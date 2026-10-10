---
title: "大模型 GPU 集合通信学习实践"
source: "GPU卡哥聊AI-Infra"
category: "Inbox"
group: "AI基础设施"
author: "韦子扬"
url: "https://weiziyang.wiki/posts/gpu-networking/llm-gpu-collective-communication-guide"
published: 2026-09-10T10:15:10+08:00
saved: 2026-10-10T09:28:03+08:00
folo_key: "url::https://weiziyang.wiki/posts/gpu-networking/llm-gpu-collective-communication-guide"
tags:
  - "folo"
  - "Inbox"
  - "GPU卡哥聊AI-Infra"
---

# 大模型 GPU 集合通信学习实践

> [!info] GPU卡哥聊AI-Infra · Inbox · 2026-09-10 10:15 · [原文](https://weiziyang.wiki/posts/gpu-networking/llm-gpu-collective-communication-guide)

> 这个要先看之前说的理论篇，不然会不知道里面的名词是什么意思； 做完这些实验以后会对整个通信组网印象特别深刻，因为能直观感受到各种原语下的通信实现和延迟，nvsharp, rdma p2p这些优化的通过消融实验所呈现的性能优势。

## 0\. 实验环境与测量方法

### 0.1 硬件与软件

| 项目         | Node 0                                           | Node 1                             |
| ---------- | ------------------------------------------------ | ---------------------------------- |
| GPU        | 8 × NVIDIA H卡 140GB                              | 8 × NVIDIA H卡 140GB                |
| GPU 互联     | NVLink `NV18`（8 卡全互联）                            | 同左                                 |
| CPU/NUMA   | 2 NUMA，GPU0-3→NUMA0，GPU4-7→NUMA1                 | 同左                                 |
| RDMA NIC   | 8 × 400Gb RoCE（mlx5\_2..mlx5\_9）+ 1 × 100Gb bond | 8 × 400Gb RoCE（mlx5\_0,3..9）+ bond |
| Link Layer | Ethernet / RoCEv2                                | Ethernet / RoCEv2                  |
| GPU-NIC 亲和 | 每张 GPU 有一张 `PIX` 直连 NIC                          | 同左                                 |
| NCCL       | 2.28.9                                           | 2.28.9                             |

## 实验0： 真实硬件拓扑

### 代码

common.py 这是公共依赖的一个utils，后面很多实验都会依赖这个:

PYTHON

```python
"""Ray 驱动的集合通信实验台：负责在 2 机 16 卡上拉起 torch.distributed 进程组，
并提供统一的计时、带宽换算、结果落盘工具。

约定:
- 每个 rank 对应一个 Ray actor，占用 1 张 GPU（Ray 会设置 CUDA_VISIBLE_DEVICES，
  所以 worker 内部的设备号恒为 cuda:0）。
- rank 编号按 node-major 排列: rank = node_index * nproc_per_node + local_rank。
- 每个实验脚本把 worker 函数定义在 __main__ 里，cloudpickle 会按值序列化；
  common.py 通过 runtime_env 的 working_dir 上传，两台机器都能 import。
"""

import datetime
import json
import os
import socket
import statistics
import subprocess
import time
from dataclasses import dataclass, field

import ray

SCRIPT_DIR = os.path.dirname(os.path.abspath(__file__))
RESULT_DIR = os.path.join(SCRIPT_DIR, "results")

# 本集群必需的默认环境变量（不是调优，是让跨机通信能建起来）:
# 1. NCCL_SOCKET_IFNAME=bond0
#    两台机器的 RoCE 网卡 eth2..eth9 是 33.8.x.x/25 的不同子网、彼此不可路由，
#    NCCL 默认挑中 eth2 做 bootstrap/OOB 会死等
#    "socketPollConnect: connect to 33.8.28.51<18001> returned Connection timed out"。
#    唯一两机互通的是 bond0（10.192.x.x，Ray 自己也用它）。只影响控制面，
#    数据面仍走 mlx5_* 的 RoCE verbs。注意网卡名是 bond0，不是 ibdev2netdev 里
#    mlx5_bond_0 对应显示的 eth0，写错会报 "Bootstrap : no socket interface found"。
# 2. TMPDIR / CUDA_CACHE_PATH 指到 /target
#    10.192.137.15 的根盘长期接近 100%，写 /tmp 容易失败，/target 有 1T+ 空间。
DEFAULT_ENV = {
    "NCCL_SOCKET_IFNAME": "bond0",
    "TMPDIR": "/target/tmp",
    "CUDA_CACHE_PATH": "/target/nvcache",
}

# busbw = algbw * factor，factor 来自 nccl-tests 的 PERFORMANCE.md
BUSBW_FACTOR = {
    "all_reduce": lambda n: 2.0 * (n - 1) / n,
    "reduce_scatter": lambda n: (n - 1) / n,
    "all_gather": lambda n: (n - 1) / n,
    "all_to_all": lambda n: (n - 1) / n,
    "broadcast": lambda n: 1.0,
    "sendrecv": lambda n: 1.0,
    "reduce": lambda n: 1.0,
}

def init_ray():
    """连接已有 Ray 集群。

    注意: 这里刻意不使用 runtime_env={"working_dir": ...}。远端节点磁盘紧张，
    working_dir 解包会报 "No space left on device"。改用 cloudpickle 按值序列化
    common 模块，worker 端无需存在本文件。
    """
    if not ray.is_initialized():
        ray.init(address="auto", log_to_driver=True)
    import sys

    ray.cloudpickle.register_pickle_by_value(sys.modules[__name__])
    return ray

def gpu_nodes():
    """按 IP 排序返回带 GPU 的存活节点，保证多次实验的 node 顺序稳定。

    同一 IP 可能残留已重启过的旧 NodeID，这里按 IP 去重并保留最新启动的那个，
    避免把 actor 调度到已经死掉的节点上。
    """
    init_ray()
    nodes = [n for n in ray.nodes() if n.get("Alive") and n["Resources"].get("GPU", 0) > 0]
    latest = {}
    for n in nodes:
        ip = n["NodeManagerAddress"]
        if ip not in latest or n.get("StartTimeMs", 0) > latest[ip].get("StartTimeMs", 0):
            latest[ip] = n
    return sorted(latest.values(), key=lambda n: n["NodeManagerAddress"])

@dataclass
class Ctx:
    """worker 函数拿到的运行上下文。"""

    rank: int
    world_size: int
    local_rank: int
    nnodes: int
    nproc_per_node: int
    host: str
    device: object = None

    @property
    def node_index(self):
        return self.rank // self.nproc_per_node

    def log(self, msg):
        print(f"[rank{self.rank:02d}@{self.host}] {msg}", flush=True)

@ray.remote(num_gpus=1)
class Worker:
    def __init__(self, rank, world_size, local_rank, nnodes, nproc_per_node, env):
        # NCCL 的环境变量必须在 communicator 创建前生效，这里在 actor 进程最早期写入。
        merged = dict(DEFAULT_ENV)
        merged.update(env or {})
        for d in ("/target/tmp", "/target/nvcache"):
            try:
                os.makedirs(d, exist_ok=True)
            except OSError:
                pass
        for k, v in merged.items():
            os.environ[k] = str(v)
        self.env = merged
        self.rank = rank
        self.world_size = world_size
        self.local_rank = local_rank
        self.nnodes = nnodes
        self.nproc_per_node = nproc_per_node
        os.environ["RANK"] = str(rank)
        os.environ["WORLD_SIZE"] = str(world_size)
        os.environ["LOCAL_RANK"] = str(local_rank)

    def ip(self):
        return ray.util.get_node_ip_address()

    def free_port(self):
        s = socket.socket()
        s.bind(("", 0))
        port = s.getsockname()[1]
        s.close()
        return port

    def setup(self, master_addr, master_port, backend, timeout_s):
        import torch
        import torch.distributed as dist

        os.environ["MASTER_ADDR"] = master_addr
        os.environ["MASTER_PORT"] = str(master_port)
        torch.cuda.set_device(0)
        dist.init_process_group(
            backend=backend,
            rank=self.rank,
            world_size=self.world_size,
            timeout=datetime.timedelta(seconds=timeout_s),
        )
        self.ctx = Ctx(
            rank=self.rank,
            world_size=self.world_size,
            local_rank=self.local_rank,
            nnodes=self.nnodes,
            nproc_per_node=self.nproc_per_node,
            host=socket.gethostname(),
            device=torch.device("cuda:0"),
        )
        warm = torch.ones(1, device="cuda:0")
        dist.all_reduce(warm)
        torch.cuda.synchronize()
        return {
            "rank": self.rank,
            "host": self.ctx.host,
            "ip": ray.util.get_node_ip_address(),
            "gpu": torch.cuda.get_device_name(0),
            "cuda_visible_devices": os.environ.get("CUDA_VISIBLE_DEVICES"),
            "nccl": ".".join(str(x) for x in torch.cuda.nccl.version()),
            "torch": torch.__version__,
            "env": self.env,
        }

    def run(self, fn, cfg):
        return fn(self.ctx, cfg)

    def teardown(self):
        import torch.distributed as dist

        if dist.is_initialized():
            dist.destroy_process_group()
        return True

def run_dist(fn, nnodes=2, nproc_per_node=8, cfg=None, env=None,
             backend="nccl", timeout_s=900, label=""):
    """在 nnodes×nproc_per_node 的规模上执行 fn(ctx, cfg)，返回 (results, infos)。

    fn 在每个 rank 上执行一次；results 按 rank 顺序返回。
    env 是本次实验专用的环境变量（例如 NCCL_ALGO），实验结束随 actor 一起销毁，
    不会污染其他实验，符合"消融变量用完即清理"的要求。
    """
    from ray.util.scheduling_strategies import NodeAffinitySchedulingStrategy

    nodes = gpu_nodes()
    if len(nodes) < nnodes:
        raise RuntimeError(f"需要 {nnodes} 个 GPU 节点，实际只有 {len(nodes)} 个")
    nodes = nodes[:nnodes]
    world_size = nnodes * nproc_per_node
    tag = label or getattr(fn, "__name__", "job")
    print(f"\n>>> [{tag}] layout={nnodes}x{nproc_per_node} world={world_size} env={env or {}}",
          flush=True)

    workers = []
    for ni, node in enumerate(nodes):
        for lr in range(nproc_per_node):
            rank = ni * nproc_per_node + lr
            w = Worker.options(
                scheduling_strategy=NodeAffinitySchedulingStrategy(node["NodeID"], soft=False),
            ).remote(rank, world_size, lr, nnodes, nproc_per_node, env)
            workers.append(w)

    try:
        master_addr = ray.get(workers[0].ip.remote())
        # 端口有竞态: free_port 探测到的端口在 TCPStore 真正 bind 之前可能被别人占用
        # （实测报 EADDRINUSE port 18041），所以换端口重试几次。
        infos, last_err = None, None
        for attempt in range(4):
            master_port = ray.get(workers[0].free_port.remote())
            try:
                infos = ray.get([w.setup.remote(master_addr, master_port, backend, timeout_s)
                                 for w in workers])
                break
            except Exception as e:  # noqa: BLE001
                last_err = e
                if "EADDRINUSE" not in str(e) and "address already in use" not in str(e):
                    raise
                print(f"    [retry {attempt + 1}] port {master_port} in use, trying another",
                      flush=True)
                try:
                    ray.get([w.teardown.remote() for w in workers], timeout=60)
                except Exception:
                    pass
                time.sleep(2)
        if infos is None:
            raise last_err
        results = ray.get([w.run.remote(fn, cfg) for w in workers])
    finally:
        try:
            ray.get([w.teardown.remote() for w in workers], timeout=60)
        except Exception:
            pass
        for w in workers:
            ray.kill(w, no_restart=True)
        time.sleep(2)  # 等 GPU 上下文释放，避免下一组实验 OOM
    return results, infos

def stats_us(samples):
    """samples: 单位 us 的耗时列表 -> 统计量字典。"""
    v = sorted(samples)
    n = len(v)

    def pct(p):
        return v[min(n - 1, max(0, int(round(p / 100.0 * n)) - 1))]

    return {
        "iters": n,
        "mean_us": statistics.fmean(v),
        "p50_us": pct(50),
        "p95_us": pct(95),
        "p99_us": pct(99),
        "min_us": v[0],
        "max_us": v[-1],
    }

def time_op(op, warmup=5, iters=20, barrier=True, inner=1):
    """用 CUDA Event 计时 op()，并对所有 rank 取每轮最大值（真实的集合完成时间）。

    inner>1 时连续执行 inner 次再除以 inner，用于小消息：摊薄 event/barrier 的
    固定开销，测到的是 back-to-back 的稳态耗时，口径更接近 nccl-tests。
    返回统计量（us）。
    """
    import torch
    import torch.distributed as dist

    for _ in range(warmup):
        op()
    torch.cuda.synchronize()
    if barrier:
        dist.barrier()

    samples = []
    start = torch.cuda.Event(enable_timing=True)
    end = torch.cuda.Event(enable_timing=True)
    for _ in range(iters):
        if barrier:
            dist.barrier()
            torch.cuda.synchronize()
        start.record()
        for _ in range(inner):
            op()
        end.record()
        torch.cuda.synchronize()
        samples.append(start.elapsed_time(end) * 1000.0 / inner)

    # 用 float32 聚合耗时: NVLS 不支持 float64（强制 NCCL_ALGO=NVLS 时会报
    # "no algorithm/protocol available for function AllReduce with datatype
    # ncclFloat64"），而 us 级耗时用 float32 表示精度足够。
    t = torch.tensor(samples, dtype=torch.float32, device="cuda")
    dist.all_reduce(t, op=dist.ReduceOp.MAX)
    return stats_us(t.tolist())

def time_op_slope(op, inners=(5, 50), warmup=20, iters=15):
    """用"斜率法"把固定开销和单次真实耗时分开。

    背景: 每个计时窗口（barrier + synchronize 之后）在跨机场景有一笔很大的固定开销，
    实测本集群约 2.4ms——两台机器的 CPU 侧 kernel launch 不同步，NCCL kernel 要等
    对端到达。若只用一个 inner 值，这笔开销会被平摊进"单次延迟"，小消息的数字
    因此虚高（inner=1 时 8B allreduce 看起来要 2.4ms，inner=50 时只有 80us）。

    做法: 对两个不同的 inner 各测总时间，
        per_op = (T(n2) - T(n1)) / (n2 - n1)      ← 真实单次耗时
        fixed  = T(n1) - n1 * per_op              ← 每个窗口的固定同步开销
    """
    n1, n2 = inners
    t1 = time_op(op, warmup=warmup, iters=iters, inner=n1)
    t2 = time_op(op, warmup=warmup, iters=iters, inner=n2)
    total1, total2 = t1["p50_us"] * n1, t2["p50_us"] * n2
    per_op = (total2 - total1) / (n2 - n1)
    return {
        "per_op_us": per_op,
        "fixed_overhead_us": total1 - n1 * per_op,
        f"avg_at_inner{n1}_us": t1["p50_us"],
        f"avg_at_inner{n2}_us": t2["p50_us"],
        "p95_at_inner1_window_us": t1["p95_us"],
    }

def bandwidth(coll, nbytes, time_us, world_size):

    """按 nccl-tests 口径换算 algbw / busbw（GB/s，1GB = 1e9 B）。"""
    sec = time_us * 1e-6
    algbw = nbytes / sec / 1e9 if sec > 0 else 0.0
    factor = BUSBW_FACTOR.get(coll, lambda n: 1.0)(world_size)
    return {"algbw_GBps": algbw, "busbw_GBps": algbw * factor, "busbw_factor": factor}

def sizes_pow2(start_bytes, end_bytes, factor=2):
    s, out = start_bytes, []
    while s <= end_bytes:
        out.append(s)
        s *= factor
    return out

def human_bytes(n):
    for unit in ["B", "KiB", "MiB", "GiB"]:
        if n < 1024 or unit == "GiB":
            return f"{n:.0f}{unit}" if unit == "B" else f"{n:g}{unit}"
        n /= 1024.0

def save_json(name, payload):
    os.makedirs(RESULT_DIR, exist_ok=True)
    path = os.path.join(RESULT_DIR, name if name.endswith(".json") else name + ".json")
    with open(path, "w") as f:
        json.dump(payload, f, indent=2, ensure_ascii=False, default=str)
    print(f"[saved] {path}", flush=True)
    return path

def env_snapshot():
    """记录软件版本与当前 NCCL_* 环境，实验记录模板里的 Software 段。"""
    import torch

    return {
        "timestamp": time.strftime("%Y-%m-%d %H:%M:%S"),
        "torch": torch.__version__,
        "cuda": torch.version.cuda,
        "nccl": ".".join(str(x) for x in torch.cuda.nccl.version()),
        "driver": _sh("nvidia-smi --query-gpu=driver_version --format=csv,noheader | head -1"),
        "gpu": _sh("nvidia-smi --query-gpu=name --format=csv,noheader | head -1"),
        "nccl_env": {k: v for k, v in os.environ.items() if k.startswith("NCCL_")},
    }

def _sh(cmd):
    try:
        return subprocess.run(cmd, shell=True, capture_output=True, text=True,
                              timeout=60).stdout.strip()
    except Exception as e:  # noqa: BLE001
        return f"<error {e}>"

```

exp00\_topology.py

脚本做两件事：用 Ray 在每个节点各起一个 actor 采集 `nvidia-smi topo -m` / `nvlink -s` / `ibdev2netdev` / `ibstat` / NUMA / 版本， 再跑一次 16 卡受控任务，打开 `NCCL_DEBUG=INFO` + `NCCL_DEBUG_SUBSYS=INIT,GRAPH,TUNING,NET,COLL` 并 dump `NCCL_TOPO_DUMP_FILE`， 把 NCCL 真正识别到的路径抓回来。

PYTHON

```python
"""实验零：确认真实硬件拓扑 + NCCL 实际识别到的拓扑。

产出 results/exp00_topology.json：
- 每个节点的 nvidia-smi topo -m / nvlink 状态 / ibdev2netdev / ibstat 摘要 / 版本信息
- 一次 2x8 受控运行中 NCCL 的 INIT/GRAPH/NET 日志摘要（Ring、Tree、NET/IB、NVLS 等）
- NCCL_TOPO_DUMP_FILE 导出的 XML 存到 results/nccl-topo-<host>.xml

用法: python exp00_topology.py
"""

import glob
import os
import re
import socket

import ray

import common

HOST_CMDS = {
    "hostname": "hostname",
    "gpu_list": "nvidia-smi --query-gpu=index,name,memory.total,driver_version --format=csv",
    "topo_matrix": "nvidia-smi topo -m",
    "nvlink_status": "nvidia-smi nvlink -s | head -40",
    "nvlink_error_count": "nvidia-smi nvlink -e | grep -c . ",
    "ibdev2netdev": "ibdev2netdev",
    "ibstat": "ibstat | grep -E '^CA|State:|Rate:|Link_layer:'",
    "numa": "lscpu | grep -E 'NUMA|Model name'",
    "cuda_version": "nvcc --version 2>/dev/null | tail -2",
    "ofed": "ofed_info -s 2>/dev/null",
}

@ray.remote(num_gpus=1)
class HostProbe:
    def collect(self):
        out = {k: common._sh(cmd) for k, cmd in HOST_CMDS.items()}
        out["software"] = common.env_snapshot()
        return out

def probe_hosts():
    from ray.util.scheduling_strategies import NodeAffinitySchedulingStrategy

    res = {}
    for node in common.gpu_nodes():
        probe = HostProbe.options(
            scheduling_strategy=NodeAffinitySchedulingStrategy(node["NodeID"], soft=False)
        ).remote()
        info = ray.get(probe.collect.remote())
        res[f"{info['hostname']} ({node['NodeManagerAddress']})"] = info
        ray.kill(probe, no_restart=True)
    return res

KEEP = re.compile(
    r"(NCCL version|Ring \d+ :|Trees \[|NVLS|Using network|NET/IB : Using|"
    r"Connected all|CollNet|Init COMPLETE|nChannels|GIN plugin|"
    r"GPU Direct RDMA Enabled for GPU 0 / HCA 0)"
)

def nccl_probe(ctx, cfg):
    """在受控运行中让 NCCL 打印初始化/拓扑日志，并 dump 拓扑 XML。"""
    import torch
    import torch.distributed as dist

    x = torch.ones(64 * 1024 * 1024 // 4, device=ctx.device)  # 64MiB，触发大消息路径
    dist.all_reduce(x)
    for size in [8, 1 << 20, 1 << 28]:  # 小/中/大消息，覆盖不同算法选择
        elems = max(ctx.world_size, (size // 4) // ctx.world_size * ctx.world_size)
        t = torch.ones(elems, device=ctx.device)
        dist.all_reduce(t)
        dist.reduce_scatter_tensor(
            torch.empty(elems // ctx.world_size, device=ctx.device), t)
        del t
    torch.cuda.synchronize()
    dist.barrier()

    # NCCL 用短主机名替换 %h，和 socket.getfqdn() 不一致，所以直接按 pid 匹配文件
    lines = []
    for path in glob.glob(f"/target/nccl-*-{os.getpid()}.log"):
        with open(path, errors="ignore") as f:
            lines = [ln.strip() for ln in f if KEEP.search(ln)]
        break
    topo_xml = ""
    dump = os.environ.get("NCCL_TOPO_DUMP_FILE", "")
    if ctx.local_rank == 0 and dump and os.path.exists(dump):
        with open(dump, errors="ignore") as f:
            topo_xml = f.read()
    return {
        "rank": ctx.rank,
        "host": ctx.host,
        "nccl_log_lines": lines[:120],
        "topo_xml": topo_xml,
    }

def main():
    payload = {"hosts": probe_hosts()}

    env = {
        "NCCL_DEBUG": "INFO",
        "NCCL_DEBUG_SUBSYS": "INIT,GRAPH,TUNING,NET,COLL",
        "NCCL_DEBUG_FILE": "/target/nccl-%h-%p.log",
        "NCCL_TOPO_DUMP_FILE": "/target/nccl-topo.xml",
    }
    res, infos = common.run_dist(nccl_probe, nnodes=2, nproc_per_node=8, env=env,
                                label="exp00_nccl_probe")
    payload["nccl_env"] = env
    payload["worker_info"] = infos
    payload["nccl_log"] = {f"rank{r['rank']}@{r['host']}": r["nccl_log_lines"]
                           for r in res if r["rank"] % 8 == 0}
    os.makedirs(common.RESULT_DIR, exist_ok=True)
    for r in res:
        if r["topo_xml"]:
            p = os.path.join(common.RESULT_DIR, f"nccl-topo-{r['host']}.xml")
            with open(p, "w") as f:
                f.write(r["topo_xml"])
            print(f"[saved] {p}")
    common.save_json("exp00_topology", payload)

if __name__ == "__main__":
    main()

```

结果会生成一个：`results/exp00_topology.json`、 `results/nccl-topo-*.xml`（NCCL 自己导出的拓扑 XML）。

根据这个xml直接丢给gpt生图可以画出一个拓扑，这张图就很清楚：

![[大模型 GPU 集合通信学习实践-01.png]]

### GPU、NIC 与 NUMA

`nvidia-smi topo -m` 的关键信息：

- 8 张 GPU 两两之间都是 `NV18`，即 18 条 NVLink 绑定，单机是全互联的 NVLink 域。
- 每张 GPU 都有一张 `PIX` 距离（只跨一个 PCIe switch）的专属 NIC： GPU0↔mlx5\_2、GPU1↔mlx5\_3 …… GPU7↔mlx5\_9，这是标准的 8 rail 布局。
- GPU0-3 与 mlx5\_2-5 在 NUMA0（CPU 0-47,96-143），GPU4-7 与 mlx5\_6-9 在 NUMA1。 跨 NUMA 的 GPU-NIC 组合显示为 `SYS`，实际训练中要避免。
- 9 张 RoCE 设备里 8 张是 400Gb（数据面），`mlx5_bond_0` 是 100Gb 管理网。

### NCCL 实际识别到的东西

从 16 卡运行的日志里读到的几条最重要的结论：

TEXT

```text
NET/IB : Using [0]mlx5_2:1/RoCE ... [7]mlx5_9:1/RoCE [8]mlx5_bond_0:1/RoCE [RO]; OOB bond0
Using network IB                          ← 走 IB verbs（RoCE），不是 Socket
Assigned GIN plugin GIN_IB_GDAKI to comm
GPU Direct RDMA Enabled for GPU 0 / HCA 0 (distance 4 <= 5)   ← GDR 打开
NVLS multicast support is available on dev 0 (NVLS_NCHANNELS 16)  ← NVLink SHARP 可用
Pattern 4, crossNic 2, nChannels 8, bw 48.000000/48.000000, type NVL/PIX
```

- **NVLS（NVLink SHARP）在这台机器上是可用的**，所以 16 卡 AllReduce 的默认算法 很可能不是 Ring 也不是 Tree，而是 NVLS/NVLSTree。这一点直接决定了实验五 "Ring vs Tree vs Auto" 的解释方式：Auto 的曲线可能比强制 Ring/Tree 都低。
- **NVLS Head 的配对是 rail 对齐的**：`NVLS Head 0: 0 8`、`Head 1: 1 9` …… 即两台机器上同位置的 GPU（rank i 与 rank i+8）组成一组，跨机流量走各自的 直连 NIC，正是 rail-optimized 的形态。
- **Ring 的排列印证了"跨机只在少数 channel 上发生"**：16 个 channel 里， rank0 的邻居大多是本机的 1/7，只有 Ring 00/01/08/09 会连到 rank8（另一台机器）。 NCCL 把跨机跳数压到最少，其余 channel 在 NVLink 域内闭环。
- NCCL 估算的单 channel 带宽是 `bw 48.0`（GB/s），`type NVL/PIX`。

### 什么是NVLink SHARP？

SHARP = **S**calable **H**ierarchical **A**ggregation and **R**eduction **P**rotocol，最早是 InfiniBand 交换机上的功能（IB SHARP），思路是在网络设备里就地完成集合通信的算术运算，而不是把数据搬到端侧再算。NVLink SHARP 是同一思路搬到机内 NVLink 域：Hopper 代（H100/H800）配第三代 NVSwitch 起，switch ASIC 里带了算术单元和 multicast 能力。

能快多少？单机 1x8：

1GiB：快 23%（4368us vs 5374.8us）——最大收益点 256MiB：快 11%

64MiB：快 10% ； 16MiB：快 6% ； ≤1MiB：倒亏 244%，256MiB 最高 14%。

收益变小是因为瓶颈转到了网络，但机内那一段规约照样走 NVSwitch，所以关掉还是会变慢。

## 实验一：集合通信性能基线

### 代码

`script/exp01_baseline.py`

PYTHON

```python
"""实验一：建立集合通信性能基线（对应教程"实验一"与"最值得产出的图表 1/2"）。

在多种 GPU 规模（1x2/1x4/1x8/2x1/2x2/2x4/2x8）下，对 6 个原语做消息大小扫描，
记录 p50/p95/p99、algbw、busbw 以及正确性检查（相当于 nccl-tests 的 #wrong）。

口径说明（重要，避免横向比较时被误导）：
- 表格里的 size 统一指"单 rank 的主 buffer 字节数"，与 nccl-tests 的 -b/-e 对齐：
  all_reduce/all_to_all/broadcast/sendrecv: in=out=size
  reduce_scatter: in=size, out=size/P；all_gather: in=size/P, out=size
- algbw = size / time；busbw = algbw * factor(P)，factor 见 common.BUSBW_FACTOR。

用法:
  python exp01_baseline.py                      # 默认全布局全原语
  python exp01_baseline.py --layouts 1x8 2x8 --colls all_reduce
  python exp01_baseline.py --max-bytes 268435456 --rounds 2
"""

import argparse

import common

ALL_COLLS = ["all_reduce", "reduce_scatter", "all_gather", "all_to_all",
             "broadcast", "sendrecv"]
ALL_LAYOUTS = [(1, 2), (1, 4), (1, 8), (2, 1), (2, 2), (2, 4), (2, 8)]

def iter_plan(nbytes):
    """按消息大小自适应迭代次数，兼顾小消息精度与大消息耗时。"""
    if nbytes <= 1 << 20:
        return dict(warmup=10, iters=30, inner=10)
    if nbytes <= 1 << 26:
        return dict(warmup=5, iters=20, inner=2)
    return dict(warmup=3, iters=10, inner=1)

def build_op(coll, ctx, nbytes):
    """返回 (op, verify, real_bytes)。verify 返回错误元素个数。"""
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    esize = 4  # float32
    elems = max(P, (nbytes // esize) // P * P)  # 保证能被 P 整除
    real_bytes = elems * esize
    dev = ctx.device
    val = float(ctx.rank + 1)
    expect_sum = P * (P + 1) / 2.0

    if coll == "all_reduce":
        buf = torch.full((elems,), val, device=dev)
        ref = buf.clone()

        def op():
            dist.all_reduce(buf)

        def verify():
            b = ref.clone()
            dist.all_reduce(b)
            return int((b - expect_sum).abs().gt(1e-3).sum().item())

    elif coll == "reduce_scatter":
        buf = torch.full((elems,), val, device=dev)
        out = torch.empty(elems // P, device=dev)

        def op():
            dist.reduce_scatter_tensor(out, buf)

        def verify():
            dist.reduce_scatter_tensor(out, buf)
            return int((out - expect_sum).abs().gt(1e-3).sum().item())

    elif coll == "all_gather":
        inp = torch.full((elems // P,), val, device=dev)
        out = torch.empty(elems, device=dev)

        def op():
            dist.all_gather_into_tensor(out, inp)

        def verify():
            dist.all_gather_into_tensor(out, inp)
            exp = torch.arange(1, P + 1, device=dev, dtype=out.dtype)
            exp = exp.repeat_interleave(elems // P)
            return int((out - exp).abs().gt(1e-3).sum().item())

    elif coll == "all_to_all":
        buf = torch.full((elems,), val, device=dev)
        out = torch.empty(elems, device=dev)

        def op():
            dist.all_to_all_single(out, buf)

        def verify():
            dist.all_to_all_single(out, buf)
            exp = torch.arange(1, P + 1, device=dev, dtype=out.dtype)
            exp = exp.repeat_interleave(elems // P)
            return int((out - exp).abs().gt(1e-3).sum().item())

    elif coll == "broadcast":
        buf = torch.full((elems,), val, device=dev)

        def op():
            dist.broadcast(buf, src=0)

        def verify():
            b = torch.full((elems,), val, device=dev)
            dist.broadcast(b, src=0)
            return int((b - 1.0).abs().gt(1e-3).sum().item())

    elif coll == "sendrecv":
        # Ring 式: 每个 rank 同时向 next 发、从 prev 收，最纯粹的点对点路径基线
        send = torch.full((elems,), val, device=dev)
        recv = torch.empty(elems, device=dev)
        nxt = (ctx.rank + 1) % P
        prv = (ctx.rank - 1) % P

        def op():
            reqs = dist.batch_isend_irecv([
                dist.P2POp(dist.isend, send, nxt),
                dist.P2POp(dist.irecv, recv, prv),
            ])
            for r in reqs:
                r.wait()

        def verify():
            op()
            return int((recv - (prv + 1)).abs().gt(1e-3).sum().item())

    else:
        raise ValueError(coll)

    return op, verify, real_bytes

def worker(ctx, cfg):
    """在一个进程组内跑完 cfg["colls"] × cfg["sizes"] 的扫描。"""
    import torch
    import torch.distributed as dist

    out = {"rank": ctx.rank, "host": ctx.host, "rows": []}
    for coll in cfg["colls"]:
        for nbytes in cfg["sizes"]:
            if nbytes < ctx.world_size * 4:
                continue  # 每 rank 至少 1 个 float32 分片
            try:
                op, verify, real_bytes = build_op(coll, ctx, nbytes)
            except torch.cuda.OutOfMemoryError:
                torch.cuda.empty_cache()
                continue
            plan = iter_plan(real_bytes)
            wrong = verify()  # 每个点都做正确性检查，等价于 nccl-tests 的 #wrong
            rounds = []
            for _ in range(cfg["rounds"]):
                rounds.append(common.time_op(op, **plan))
            merged = {
                "coll": coll,
                "bytes": real_bytes,
                "wrong": wrong,
                "round_p50_us": [r["p50_us"] for r in rounds],
                # 多轮取中位数轮，避免单轮抖动
                "p50_us": sorted(r["p50_us"] for r in rounds)[len(rounds) // 2],
                "p95_us": max(r["p95_us"] for r in rounds),
                "p99_us": max(r["p99_us"] for r in rounds),
                "min_us": min(r["min_us"] for r in rounds),
                "iters": plan,
            }
            merged.update(common.bandwidth(coll, real_bytes, merged["p50_us"], ctx.world_size))
            out["rows"].append(merged)
            del op, verify
            torch.cuda.empty_cache()
            dist.barrier()
        if ctx.rank == 0:
            ctx.log(f"{coll} done ({len(out['rows'])} points)")
    return out

def latency_worker(ctx, cfg):
    """小消息专项: 用斜率法分离"每次计时窗口的固定同步开销"和"单次真实耗时"。

    背景见 common.time_op_slope 的注释——跨机场景下 barrier 之后的首次通信要等
    对端 CPU launch，这笔开销在小消息上比通信本身大一个数量级，
    不分开就会把"跨机 8B AllReduce 要 2.4ms"这种假结论写进报告。
    """
    import torch
    import torch.distributed as dist

    out = {"rank": ctx.rank, "rows": []}
    for coll in cfg["colls"]:
        for nbytes in cfg["sizes"]:
            if nbytes < ctx.world_size * 4:
                continue
            op, verify, real = build_op(coll, ctx, nbytes)
            wrong = verify()
            st = common.time_op_slope(op, inners=tuple(cfg.get("inners", (5, 50))))
            row = {"coll": coll, "bytes": real, "wrong": wrong}
            row.update(st)
            row.update(common.bandwidth(coll, real, st["per_op_us"], ctx.world_size))
            out["rows"].append(row)
            del op, verify
            torch.cuda.empty_cache()
            dist.barrier()
    return out

def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--layouts", nargs="*", default=None, help="如 1x8 2x8")
    ap.add_argument("--colls", nargs="*", default=ALL_COLLS)
    ap.add_argument("--min-bytes", type=int, default=8)
    ap.add_argument("--max-bytes", type=int, default=1 << 31)  # 2GiB
    ap.add_argument("--factor", type=int, default=4, help="消息大小每次乘几，默认 4")
    ap.add_argument("--rounds", type=int, default=3, help="每个点重复几轮")
    ap.add_argument("--mode", choices=["sweep", "latency"], default="sweep",
                    help="sweep=完整扫描；latency=小消息斜率法专项")
    ap.add_argument("--out", default=None)
    args = ap.parse_args()

    layouts = ALL_LAYOUTS
    if args.layouts:
        layouts = [tuple(int(x) for x in s.split("x")) for s in args.layouts]
    out_name = args.out or ("exp01_baseline" if args.mode == "sweep" else "exp01_latency")

    sizes = common.sizes_pow2(args.min_bytes, args.max_bytes, args.factor)
    cfg = {"colls": args.colls, "sizes": sizes, "rounds": args.rounds}
    payload = {"meta": {"sizes": sizes, "colls": args.colls, "rounds": args.rounds,
                        "mode": args.mode},
               "layouts": {}}
    fn = worker if args.mode == "sweep" else latency_worker

    for nnodes, nproc in layouts:
        tag = f"{nnodes}x{nproc}"
        res, infos = common.run_dist(fn, nnodes=nnodes, nproc_per_node=nproc,
                                     cfg=cfg, label=f"exp01_{args.mode}_{tag}")
        payload["layouts"][tag] = {
            "world_size": nnodes * nproc,
            "hosts": sorted({i["host"] for i in infos}),
            "software": {k: infos[0][k] for k in ("torch", "nccl", "gpu")},
            "rows": res[0]["rows"],  # rank0 视角，时间已是全 rank 最大值
        }
        common.save_json(out_name, payload)  # 每个布局跑完就落盘，防中断丢数据

if __name__ == "__main__":
    main()

```

7 种布局 × 6 个原语 × 8B→2GiB（每次 ×4）× 每点 3 轮，共 594 个数据点， **`wrong` 全部为 0**，即所有规模、所有原语的数值结果都正确。

### AllReduce 延迟（p50，单位 us）

1x2 1x4 这些是指布局， 格式是：`节点数 × 每节点gpu数量`

- `1x2` = 1 台机器上用 2 张 GPU，共 2 个 rank
- `1x4` = 1 台机器 4 张卡
- `1x8` = 1 台机器 8 张卡（打满单机，全程走 NVLink）
- `2x1` = **2 台机器各 1 张卡**，共 2 个 rank——这一列所有流量都跨机
- `2x2` = 2 台机器各 2 张卡，共 4 rank
- `2x4` = 2 台机器各 4 张卡，共 8 rank
- `2x8` = 2 台机器各 8 张卡，共 16 rank（全集群）

| size   | 1x2   | 1x4   | 1x8   | 2x1    | 2x2    | 2x4    | 2x8    |
| ------ | ----- | ----- | ----- | ------ | ------ | ------ | ------ |
| 128B   | 21.6  | 23.5  | 24.6  | 266.3  | 281.4  | 266.3  | 271.8  |
| 32KiB  | 21.7  | 22.7  | 23.5  | 270.8  | 287.8  | 273.1  | 279.7  |
| 512KiB | 22.7  | 24.1  | 24.2  | 335.3  | 324.8  | 298.3  | 308.0  |
| 2MiB   | 38.1  | 39.9  | 52.4  | 1285.4 | 1286.9 | 1294.8 | 1279.4 |
| 32MiB  | 146.0 | 194.2 | 220.0 | 1997.5 | 1752.8 | 1508.2 | 1452.5 |
| 512MiB | 1724  | 2427  | 2442  | 25739  | 13300  | 8140   | 7087   |
| 2GiB   | 6375  | 9232  | 8623  | 95560  | 53143  | 35477  | 18214  |

### AllReduce busbw（ **bus bandwidth** 总线带宽） （GB/s）

**`algbw`（algorithm bandwidth，算法带宽）** =  size / time

这是最朴素的算法——用户交了多少数据、花了多长时间，一除就完事。问题是它不反映硬件负载：8 卡 AllReduce 里，你交 1GB 数据，但为了完成规约，链路上要来回搬远超 1GB 的字节。而且卡数不同时搬的量也不同，所以 algbw 没法跨规模比较。

**`busbw`（bus bandwidth）** 

乘一个只跟原语和卡数 P 有关的系数，把 algbw 折算成"链路上真正流过的字节速率"。报告用的系数：

- AllReduce：2(P−1)/P
- ReduceScatter / AllGather / AllToAll：P-1/P
- Broadcast / SendRecv：1

| size   | 1x2   | 1x4   | 1x8       | 2x1  | 2x2  | 2x4   | 2x8       |
| ------ | ----- | ----- | --------- | ---- | ---- | ----- | --------- |
| 512KiB | 23.1  | 32.6  | 37.9      | 1.6  | 2.4  | 3.1   | 3.2       |
| 8MiB   | 148.9 | 159.3 | 163.7     | 5.8  | 9.1  | 10.8  | 11.7      |
| 32MiB  | 229.7 | 259.2 | 266.9     | 16.8 | 28.7 | 38.9  | 43.3      |
| 512MiB | 311.4 | 331.8 | 384.7     | 20.9 | 60.6 | 115.4 | 142.0     |
| 2GiB   | 336.9 | 348.9 | **435.8** | 22.5 | 60.6 | 105.9 | **221.1** |

![[大模型 GPU 集合通信学习实践-02.png]]

**很明显，跨机的延迟会比不跨机的高一个量级（10倍）以上； 这就是为什么说TP EP 尽量在nvlink域内；**

**三个消息区：**

- **小消息区**：单机 8B→512KiB 的耗时几乎是常数 21~25us，跨机是 266~ 335us。 也就是说**跨机的固定启动成本比单机高一个数量级**（约 11 倍）。 这个平台段一直延伸到 512KiB，说明 512KiB 以下的通信量对时间几乎没有影响， 优化方向只有"减少通信次数"而不是"减少字节数"。
- **中等消息区的拐点在 512KiB → 2MiB 之间，而且非常陡**： 跨机 2x8 从 308us 直接跳到 1279us（4 倍字节，4.2 倍时间）， 单机 1x8 从 24us 跳到 52us。这就是 NCCL 切换协议/算法的位置 （LL/LL128 → Simple，channel 数变化），实验五会正面验证。
- **大消息区**：busbw 单调爬升并趋于饱和，2GiB 时 1x8 达到 435.8 GB/s， 2x8 达到 221.1 GB/s。

### 不同通信原语下的的algbw 和 busbw

单机 1x8，2GiB 时各原语的 `busbw/algbw`（GB/s）：

不要直接拿不同集合通信的 `algbw` 横向比较。不同原语为了完成相同大小的逻辑操作，需要经过链路的真实数据量不同，应同时查看归一化后的 `busbw`。

| 原语            | busbw | algbw | busbw factor    |
| ------------- | ----- | ----- | --------------- |
| AllReduce     | 436   | 249   | 2(P-1)/P = 1.75 |
| ReduceScatter | 345   | 394   | (P-1)/P = 0.875 |
| AllGather     | 335   | 383   | 0.875           |
| AllToAll      | 328   | 375   | 0.875           |
| Broadcast     | 348   | 348   | 1               |
| SendRecv      | 357   | 357   | 1               |

如果只看 `algbw`，会得到"ReduceScatter(394) 比 AllReduce(249) 快 58%"的错误印象。

归一化到 `busbw` 之后才看得出：AllReduce 反而是链路利用最充分的那个。

## 实验二：AllReduce = ReduceScatter + AllGather

### 代码

PYTHON

```python
"""实验二：证明 AllReduce = ReduceScatter + AllGather（教程"实验二"）。

三部分:
1. 小 tensor 可视化: 4 rank 上打印输入、AllReduce 结果、RS 分片、AG 结果，逐元素比对。
2. 扩大 tensor 后比较性能: 内置 AllReduce vs 独立 RS + 独立 AG vs RS+AG 串联，
   同时记录理论链路通信量，验证"语义等价 ≠ 性能等价"。
3. 反向关系: 用自定义 autograd Function 验证
   AllGather 的反向是 ReduceScatter、ReduceScatter 的反向是 AllGather、
   AllToAll 的反向是再做一次 AllToAll。

用法:
  python exp02_allreduce_vs_rs_ag.py                 # 1x4 可视化 + 1x8/2x8 性能
  python exp02_allreduce_vs_rs_ag.py --layouts 1x8
"""

import argparse

import common

def visualize(ctx, cfg):
    """小 tensor 可视化: 每个 rank 持有 [A_i, B_i, C_i, D_i] 形态的可读输入。"""
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    # rank i 的第 j 个元素 = (j+1)*10 + i，方便肉眼看出"哪个分片来自哪个 rank"
    x = torch.tensor([(j + 1) * 10 + ctx.rank for j in range(P)],
                     dtype=torch.float32, device=ctx.device)
    src = x.clone()

    a = x.clone()
    dist.all_reduce(a)  # 方案 A

    b = x.clone()
    shard = torch.empty(1, dtype=torch.float32, device=ctx.device)
    dist.reduce_scatter_tensor(shard, b)  # 方案 B 第一步
    gathered = torch.empty(P, dtype=torch.float32, device=ctx.device)
    dist.all_gather_into_tensor(gathered, shard)  # 方案 B 第二步

    return {
        "rank": ctx.rank,
        "host": ctx.host,
        "input": src.tolist(),
        "allreduce": a.tolist(),
        "rs_shard": shard.tolist(),          # RS 之后本 rank 只拥有第 rank 个分片
        "rs_ag": gathered.tolist(),
        "max_abs_diff": float((a - gathered).abs().max().item()),
        "equal": bool(torch.equal(a, gathered)),
    }

def perf(ctx, cfg):
    """性能对比: AllReduce vs RS / AG / RS+AG。"""
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    rows = []
    for nbytes in cfg["sizes"]:
        elems = max(P, (nbytes // 4) // P * P)
        real = elems * 4
        x = torch.randn(elems, device=ctx.device)
        buf = x.clone()
        shard = torch.empty(elems // P, device=ctx.device)
        out = torch.empty(elems, device=ctx.device)
        plan = dict(warmup=5, iters=20, inner=2 if real <= (1 << 26) else 1)

        t_ar = common.time_op(lambda: dist.all_reduce(buf), **plan)
        t_rs = common.time_op(lambda: dist.reduce_scatter_tensor(shard, buf), **plan)
        t_ag = common.time_op(lambda: dist.all_gather_into_tensor(out, shard), **plan)

        def rs_ag():
            dist.reduce_scatter_tensor(shard, buf)
            dist.all_gather_into_tensor(out, shard)

        t_both = common.time_op(rs_ag, **plan)

        # 数值一致性: 同一份输入分别走两条路
        a = x.clone()
        dist.all_reduce(a)
        b = x.clone()
        dist.reduce_scatter_tensor(shard, b)
        dist.all_gather_into_tensor(out, shard)
        err = float((a - out).abs().max().item())

        rows.append({
            "bytes": real,
            "allreduce_us": t_ar["p50_us"],
            "reduce_scatter_us": t_rs["p50_us"],
            "all_gather_us": t_ag["p50_us"],
            "rs_plus_ag_us": t_both["p50_us"],
            "rs_ag_sum_of_parts_us": t_rs["p50_us"] + t_ag["p50_us"],
            "ratio_rsag_over_ar": t_both["p50_us"] / t_ar["p50_us"],
            "allreduce_busbw": common.bandwidth("all_reduce", real, t_ar["p50_us"], P)["busbw_GBps"],
            "rs_busbw": common.bandwidth("reduce_scatter", real, t_rs["p50_us"], P)["busbw_GBps"],
            "ag_busbw": common.bandwidth("all_gather", real, t_ag["p50_us"], P)["busbw_GBps"],
            # 理想 Ring 模型下的链路字节数，二者同阶
            "theory_ring_bytes_allreduce": 2 * (P - 1) / P * real,
            "theory_ring_bytes_rs_ag": (P - 1) / P * real * 2,
            "max_abs_err": err,
        })
        del x, buf, shard, out, a, b
        torch.cuda.empty_cache()
        dist.barrier()
    return {"rank": ctx.rank, "rows": rows}

def backward_check(ctx, cfg):
    """验证反向关系: AllGather↔ReduceScatter 互为反向，AllToAll 的反向是 AllToAll。"""
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    dev = ctx.device

    class AllGatherFn(torch.autograd.Function):
        @staticmethod
        def forward(ctx_, x):
            out = torch.empty(x.numel() * P, dtype=x.dtype, device=x.device)
            dist.all_gather_into_tensor(out, x.contiguous())
            return out

        @staticmethod
        def backward(ctx_, g):
            # AllGather 的反向 = ReduceScatter
            out = torch.empty(g.numel() // P, dtype=g.dtype, device=g.device)
            dist.reduce_scatter_tensor(out, g.contiguous())
            return out

    class ReduceScatterFn(torch.autograd.Function):
        @staticmethod
        def forward(ctx_, x):
            out = torch.empty(x.numel() // P, dtype=x.dtype, device=x.device)
            dist.reduce_scatter_tensor(out, x.contiguous())
            return out

        @staticmethod
        def backward(ctx_, g):
            # ReduceScatter 的反向 = AllGather
            out = torch.empty(g.numel() * P, dtype=g.dtype, device=g.device)
            dist.all_gather_into_tensor(out, g.contiguous())
            return out

    class AllToAllFn(torch.autograd.Function):
        @staticmethod
        def forward(ctx_, x):
            out = torch.empty_like(x)
            dist.all_to_all_single(out, x.contiguous())
            return out

        @staticmethod
        def backward(ctx_, g):
            # AllToAll 的反向 = 反向路由的 AllToAll
            out = torch.empty_like(g)
            dist.all_to_all_single(out, g.contiguous())
            return out

    res = {"rank": ctx.rank}

    # AllGather: 手写 autograd 的梯度 vs 数值定义的期望梯度
    # loss = sum(w * allgather(x))，则 dL/dx[i] = reduce_scatter(w)[i]
    x = torch.full((4,), float(ctx.rank + 1), device=dev, requires_grad=True)
    w = torch.arange(1, 4 * P + 1, dtype=torch.float32, device=dev)
    (AllGatherFn.apply(x) * w).sum().backward()
    expect = torch.empty(4, device=dev)
    dist.reduce_scatter_tensor(expect, w.clone())
    res["allgather_bwd_is_rs"] = float((x.grad - expect).abs().max().item())

    # ReduceScatter: loss = sum(w_shard * rs(x))，则 dL/dx = allgather(w_shard)
    x2 = torch.full((4 * P,), float(ctx.rank + 1), device=dev, requires_grad=True)
    w2 = torch.full((4,), float(ctx.rank + 1), device=dev)
    (ReduceScatterFn.apply(x2) * w2).sum().backward()
    expect2 = torch.empty(4 * P, device=dev)
    dist.all_gather_into_tensor(expect2, w2.clone())
    res["rs_bwd_is_allgather"] = float((x2.grad - expect2).abs().max().item())

    # AllToAll: 反向再 AllToAll 一次，两次路由应还原到本 rank 的原始位置
    x3 = torch.arange(4 * P, dtype=torch.float32, device=dev, requires_grad=True)
    w3 = torch.arange(4 * P, dtype=torch.float32, device=dev) + ctx.rank
    (AllToAllFn.apply(x3) * w3).sum().backward()
    expect3 = torch.empty_like(w3)
    dist.all_to_all_single(expect3, w3.clone())
    res["a2a_bwd_is_a2a"] = float((x3.grad - expect3).abs().max().item())
    return res

def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--layouts", nargs="*", default=["1x8", "2x8"])
    ap.add_argument("--vis-layout", default="1x4")
    ap.add_argument("--min-bytes", type=int, default=1 << 12)
    ap.add_argument("--max-bytes", type=int, default=1 << 30)
    ap.add_argument("--factor", type=int, default=8)
    ap.add_argument("--out", default="exp02_allreduce_vs_rs_ag")
    args = ap.parse_args()

    payload = {}
    nn, np_ = (int(x) for x in args.vis_layout.split("x"))
    vis, _ = common.run_dist(visualize, nnodes=nn, nproc_per_node=np_,
                             label="exp02_visualize")
    payload["visualize"] = {"layout": args.vis_layout, "ranks": vis}
    common.save_json(args.out, payload)

    sizes = common.sizes_pow2(args.min_bytes, args.max_bytes, args.factor)
    payload["perf"] = {}
    payload["backward"] = {}
    for tag in args.layouts:
        nn, np_ = (int(x) for x in tag.split("x"))
        res, infos = common.run_dist(perf, nnodes=nn, nproc_per_node=np_,
                                     cfg={"sizes": sizes}, label=f"exp02_perf_{tag}")
        payload["perf"][tag] = {"world_size": nn * np_, "rows": res[0]["rows"]}
        bw, _ = common.run_dist(backward_check, nnodes=nn, nproc_per_node=np_,
                                label=f"exp02_backward_{tag}")
        payload["backward"][tag] = bw
        common.save_json(args.out, payload)

if __name__ == "__main__":
    main()

```

### 语义等价（1x4，4 元素，肉眼可查）

每个 rank 的第 j 个元素初值取 `(j+1)*10 + rank`：

| rank | 输入                 | AllReduce            | RS 之后本 rank 持有的分片 | RS+AG 结果             |
| ---- | ------------------ | -------------------- | ----------------- | -------------------- |
| 0    | \[10, 20, 30, 40\] | \[46, 86, 126, 166\] | \[46\]            | \[46, 86, 126, 166\] |
| 1    | \[11, 21, 31, 41\] | \[46, 86, 126, 166\] | \[86\]            | \[46, 86, 126, 166\] |
| 2    | \[12, 22, 32, 42\] | \[46, 86, 126, 166\] | \[126\]           | \[46, 86, 126, 166\] |
| 3    | \[13, 23, 33, 43\] | \[46, 86, 126, 166\] | \[166\]           | \[46, 86, 126, 166\] |

ReduceScatter 之后每个 rank 只拿到自己那一片的完整归约值（rank r 拿第 r 片）， AllGather 再把 4 片拼回去，与 AllReduce 逐元素相等（`equal=True`）。

### 语义等价 ≠ 性能等价

单机 1x8，p50（us）：

| size   | AllReduce | ReduceScatter | AllGather | RS+AG 串联 | RS+AG / AR |
| ------ | --------- | ------------- | --------- | -------- | ---------- |
| 32KiB  | 36.3      | 37.0          | 37.6      | 63.6     | **1.75**   |
| 256KiB | 37.1      | 38.1          | 34.6      | 66.5     | **1.79**   |
| 2MiB   | 53.9      | 37.4          | 40.4      | 65.8     | 1.22       |
| 16MiB  | 133.8     | 84.9          | 84.7      | 164.8    | 1.23       |
| 128MiB | 666.4     | 404.6         | 422.9     | 814.1    | 1.22       |
| 1GiB   | 4363.4    | 2784.8        | 2854.5    | 5623.9   | **1.29**   |

两条关键发现：

1. **小消息（≤256KiB）RS+AG 要慢 75~79%**。因为此时耗时几乎全是固定开销 （kernel launch + 同步），做两次集合就要付两倍。**语义等价的算子组合，在延迟主导区会因为"多一次 Collective"而显著变慢。**
2. **大消息 RS+AG 慢 22~29%**。单看 RS 或 AG，各自只要 AllReduce 的 62~65% （2784/4363 = 0.64），符合"AllReduce 的链路字节数是 RS 或 AG 的两倍"这一理论； 但串起来是 1.29 倍，多出来的部分是两次 collective 之间的隐式同步和 无法跨 collective 流水的那段——NCCL 内部的 AllReduce 会把 RS 和 AG 两个阶段 做分块流水，而在 Python 层调两次就没有这个优化。

### 反向关系

用自定义 `autograd.Function` 验证（1x8 与 2x8，误差均为 0）：

| 前向            | 反向应该是          | 实测最大误差 |
| ------------- | -------------- | ------ |
| AllGather     | ReduceScatter  | 0.0    |
| ReduceScatter | AllGather      | 0.0    |
| AllToAll      | 反向路由的 AllToAll | 0.0    |

验证方式是构造 `loss = sum(w × f(x))`， 让手写反向的 `x.grad` 与解析期望（对 AllGather 是 `reduce_scatter(w)`， 对 ReduceScatter 是 `all_gather(w)`）逐元素比对。这三条正是 Megatron 里 `ColumnParallelLinear` / `RowParallelLinear` / MoE dispatcher 的通信骨架。

## 实验三：亲手实现 Ring AllReduce

### 代码

代码：`script/exp03_ring_allreduce.py`

PYTHON

```python
"""实验三：亲手实现 Ring AllReduce（教程"实验三"）。

目标不是超过 NCCL，而是把 ReduceScatter + AllGather 两阶段、共 2(P-1) 轮的
chunk 流动变成可观察的过程，并验证:
- 结果与 dist.all_reduce 一致（2/4/8/16 rank 都对）
- 每个 rank 的发送量接近 2(P-1)S/P
- 手写 Python 版在大消息下远慢于 NCCL，但通信结构一致

用法:
  python exp03_ring_allreduce.py                 # 4rank 详细日志 + 多规模验证/性能
  python exp03_ring_allreduce.py --layouts 1x8
"""

import argparse

import common

def ring_allreduce(t, ctx, trace=None):
    """教学版 Ring AllReduce。t 是 1D contiguous tensor，numel 必须能被 P 整除。

    trace 非 None 时记录每一轮的 chunk 流动，用于生成教程里的 Round 表格。
    """
    import torch
    import torch.distributed as dist

    P, rank = ctx.world_size, ctx.rank
    chunks = list(t.chunk(P))
    send_to = (rank + 1) % P
    recv_from = (rank - 1) % P
    tmp = torch.empty_like(chunks[0])
    sent_bytes = 0

    # 阶段一 ReduceScatter: P-1 轮后，rank r 上第 r 个 chunk 是全局归约结果
    for step in range(P - 1):
        send_idx = (rank - step) % P
        recv_idx = (rank - step - 1) % P
        reqs = dist.batch_isend_irecv([
            dist.P2POp(dist.isend, chunks[send_idx], send_to),
            dist.P2POp(dist.irecv, tmp, recv_from),
        ])
        for r in reqs:
            r.wait()
        chunks[recv_idx] += tmp  # 收到的分片累加到本地对应位置
        sent_bytes += chunks[send_idx].numel() * chunks[send_idx].element_size()
        if trace is not None:
            trace.append({
                "phase": "RS", "round": step + 1, "rank": rank,
                "send_chunk": send_idx, "send_to": send_to,
                "recv_chunk": recv_idx, "recv_from": recv_from,
                "accumulated_chunk": recv_idx,
                "chunk_values": [round(float(c[0].item()), 3) for c in chunks],
            })

    # 阶段二 AllGather: 把已归约完成的 chunk 沿 Ring 传播一圈
    for step in range(P - 1):
        send_idx = (rank - step + 1) % P
        recv_idx = (rank - step) % P
        reqs = dist.batch_isend_irecv([
            dist.P2POp(dist.isend, chunks[send_idx], send_to),
            dist.P2POp(dist.irecv, tmp, recv_from),
        ])
        for r in reqs:
            r.wait()
        chunks[recv_idx].copy_(tmp)
        sent_bytes += chunks[send_idx].numel() * chunks[send_idx].element_size()
        if trace is not None:
            trace.append({
                "phase": "AG", "round": step + 1, "rank": rank,
                "send_chunk": send_idx, "send_to": send_to,
                "recv_chunk": recv_idx, "recv_from": recv_from,
                "chunk_values": [round(float(c[0].item()), 3) for c in chunks],
            })
    return sent_bytes

def trace_worker(ctx, cfg):
    """小 tensor + 完整日志: 每个 chunk 初值取 (chunk_id+1)*10 + rank，肉眼可追踪。"""
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    per_chunk = cfg.get("elems_per_chunk", 2)
    vals = []
    for c in range(P):
        vals += [float((c + 1) * 10 + ctx.rank)] * per_chunk
    t = torch.tensor(vals, device=ctx.device)
    ref = t.clone()
    dist.all_reduce(ref)

    trace = []
    sent = ring_allreduce(t, ctx, trace=trace)
    return {
        "rank": ctx.rank,
        "world_size": P,
        "input": [round(v, 1) for v in vals],
        "mine": t.tolist(),
        "nccl_ref": ref.tolist(),
        "max_abs_diff": float((t - ref).abs().max().item()),
        "sent_bytes": sent,
        "theory_sent_bytes": 2 * (P - 1) / P * ref.numel() * 4,
        "rounds": len(trace),
        "trace": trace,
    }

def perf_worker(ctx, cfg):
    """性能对比: 手写 Ring vs NCCL AllReduce，并核对正确性。"""
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    rows = []
    for nbytes in cfg["sizes"]:
        elems = max(P, (nbytes // 4) // P * P)
        real = elems * 4
        base = torch.randn(elems, device=ctx.device)

        mine = base.clone()
        sent = ring_allreduce(mine, ctx)
        ref = base.clone()
        dist.all_reduce(ref)
        err = float((mine - ref).abs().max().item())

        # 手写版本每次都要重新拷贝输入，计时里排除拷贝: 用同一 buffer 反复跑
        buf = base.clone()
        plan = dict(warmup=2, iters=5 if real > (1 << 24) else 10, inner=1)
        t_ring = common.time_op(lambda: ring_allreduce(buf, ctx), **plan)
        buf2 = base.clone()
        t_nccl = common.time_op(lambda: dist.all_reduce(buf2), **plan)

        rows.append({
            "bytes": real,
            "manual_ring_us": t_ring["p50_us"],
            "nccl_allreduce_us": t_nccl["p50_us"],
            "slowdown_x": t_ring["p50_us"] / t_nccl["p50_us"],
            "manual_busbw": common.bandwidth("all_reduce", real, t_ring["p50_us"], P)["busbw_GBps"],
            "nccl_busbw": common.bandwidth("all_reduce", real, t_nccl["p50_us"], P)["busbw_GBps"],
            "sent_bytes_per_rank": sent,
            "theory_sent_bytes": 2 * (P - 1) / P * real,
            "rounds": 2 * (P - 1),
            "max_abs_err": err,
        })
        del base, mine, ref, buf, buf2
        torch.cuda.empty_cache()
        dist.barrier()
    return {"rank": ctx.rank, "rows": rows}

def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--trace-layout", default="1x4")
    ap.add_argument("--verify-layouts", nargs="*", default=["1x2", "1x4", "1x8", "2x8"])
    ap.add_argument("--layouts", nargs="*", default=["1x8", "2x8"],
                    help="做性能对比的布局")
    ap.add_argument("--min-bytes", type=int, default=1 << 12)
    ap.add_argument("--max-bytes", type=int, default=1 << 28)
    ap.add_argument("--factor", type=int, default=16)
    ap.add_argument("--out", default="exp03_ring_allreduce")
    args = ap.parse_args()

    payload = {}
    nn, np_ = (int(x) for x in args.trace_layout.split("x"))
    tr, _ = common.run_dist(trace_worker, nnodes=nn, nproc_per_node=np_,
                            cfg={"elems_per_chunk": 2}, label="exp03_trace")
    payload["trace"] = {"layout": args.trace_layout, "ranks": tr}
    common.save_json(args.out, payload)

    # 不同 rank 数下的正确性（教程要求 2/4/8/16 都验证）
    payload["verify"] = {}
    for tag in args.verify_layouts:
        nn, np_ = (int(x) for x in tag.split("x"))
        r, _ = common.run_dist(trace_worker, nnodes=nn, nproc_per_node=np_,
                               cfg={"elems_per_chunk": 4}, label=f"exp03_verify_{tag}")
        payload["verify"][tag] = {
            "world_size": nn * np_,
            "max_abs_diff": max(x["max_abs_diff"] for x in r),
            "rounds": r[0]["rounds"],
            "sent_bytes": r[0]["sent_bytes"],
            "theory_sent_bytes": r[0]["theory_sent_bytes"],
        }
        common.save_json(args.out, payload)

    sizes = common.sizes_pow2(args.min_bytes, args.max_bytes, args.factor)
    payload["perf"] = {}
    for tag in args.layouts:
        nn, np_ = (int(x) for x in tag.split("x"))
        r, _ = common.run_dist(perf_worker, nnodes=nn, nproc_per_node=np_,
                               cfg={"sizes": sizes}, label=f"exp03_perf_{tag}")
        payload["perf"][tag] = {"world_size": nn * np_, "rows": r[0]["rows"]}
        common.save_json(args.out, payload)

if __name__ == "__main__":
    main()

```

### rank 小 tensor 的 chunk 流动

每个 rank 的 chunk c 初值 = `(c+1)*10 + rank`。下表是 **rank0** 视角， `vals` 是它本地 4 个 chunk 在每轮结束后的值（正确答案是 46/86/126/166）：

| Round | rank0 发出 | 发给 | 收到并累加  | rank0 本地 4 个 chunk       |
| ----- | -------- | -- | ------ | ------------------------ |
| RS-1  | chunk0   | r1 | chunk3 | \[10, 20, 30, **83**\]   |
| RS-2  | chunk3   | r1 | chunk2 | \[10, 20, **95**, 83\]   |
| RS-3  | chunk2   | r1 | chunk1 | \[10, **86**, 95, 83\]   |
| AG-1  | chunk1   | r1 | chunk0 | \[**46**, 86, 95, 83\]   |
| AG-2  | chunk0   | r1 | chunk3 | \[46, 86, 95, **166**\]  |
| AG-3  | chunk3   | r1 | chunk2 | \[46, 86, **126**, 166\] |

可以清楚看到两个阶段的分工：RS 的 3 轮里，每轮把一个 chunk 往前传、 同时累加收到的 chunk，第 3 轮结束时 rank0 手上**只有 chunk1 是完整的**（86）； AG 的 3 轮把各自完成的 chunk 沿环传播，最后 4 个 chunk 全部正确。 中间态 83/95 是"部分和"，正是 Ring 算法的特征。

### 手写版 vs NCCL

| size   | 1x8 手写(us) | 1x8 NCCL(us) | 慢多少   | 2x8 手写(us) | 2x8 NCCL(us) | 慢多少      |
| ------ | ---------- | ------------ | ----- | ---------- | ------------ | -------- |
| 4KiB   | 940.9      | 41.3         | 22.8x | 3017.7     | 2426.5       | 1.2x     |
| 64KiB  | 908.8      | 43.0         | 21.1x | 3002.8     | 2449.3       | 1.2x     |
| 1MiB   | 918.2      | 51.9         | 17.7x | 3366.0     | 2472.2       | 1.4x     |
| 16MiB  | 1074.3     | 146.3        | 7.3x  | 4138.7     | 2579.2       | 1.6x     |
| 256MiB | 7891.2     | 1260.9       | 6.3x  | 34573.4    | 3601.8       | **9.6x** |

- 单机小消息慢 20 倍以上：手写版要执行 14 轮 Python 循环，每轮两次 `batch_isend_irecv` + 一次 `+=`，共 ~40 次 kernel launch， 而 NCCL 一次 kernel 就完成。**小消息的差距几乎全是 launch 开销**。
- 大消息差距缩小到 6~7 倍：此时带宽开始主导，手写版的问题变成 "没有分块流水"——每轮必须等整个 chunk 传完才能开始下一轮， 而 NCCL 会把 chunk 再切片、让多个 channel 并行跑。
- 跨机小消息看起来只慢 1.2 倍，这是假象：两者都被那 2.4ms 的窗口固定开销压住了。 到 256MiB 时真实差距暴露为 9.6 倍。

**结论**：手写 Ring 完全复现了算法结构（轮数、通信量、正确性）， 但性能差 6~23 倍。差距不在算法，在 kernel 融合、分块流水、多 channel 并行。

## 实验四：亲手实现 Tree AllReduce，并与 Ring 对比

代码

`script/exp04_tree_allreduce.py`

PYTHON

```python
"""实验四：亲手实现 Tree AllReduce，并与手写 Ring 对比（教程"实验四"）。

教学版 Binary Tree:
  阶段一 叶子 → 根 逐层 Reduce
  阶段二 根 → 叶子 逐层 Broadcast
关键路径深度约 2*ceil(log2(P))，对比 Ring 的 2(P-1) 轮。

注意: 手写 Tree 只有单 channel、无分块流水、无 Double Binary Tree，
不能把它的性能当成 NCCL Tree 的上限。

用法:
  python exp04_tree_allreduce.py
  python exp04_tree_allreduce.py --layouts 1x8 2x8
"""

import argparse
import math

import ray

import common
import exp03_ring_allreduce as exp03

def tree_allreduce(t, ctx, trace=None):
    """Binary tree: parent = (r-1)//2, children = 2r+1, 2r+2。"""
    import torch
    import torch.distributed as dist

    P, rank = ctx.world_size, ctx.rank
    parent = (rank - 1) // 2 if rank > 0 else None
    kids = [c for c in (2 * rank + 1, 2 * rank + 2) if c < P]
    tmp = torch.empty_like(t)
    sent = 0
    nbytes = t.numel() * t.element_size()

    # 阶段一: 先收齐所有子树的部分和（子节点必须等它自己的子树先完成，天然形成层序）
    for c in kids:
        dist.recv(tmp, src=c)
        t += tmp
        if trace is not None:
            trace.append({"phase": "reduce", "rank": rank, "recv_from": c})
    if parent is not None:
        dist.send(t, dst=parent)
        sent += nbytes
        if trace is not None:
            trace.append({"phase": "reduce", "rank": rank, "send_to": parent})
        # 阶段二: 等父节点把最终结果发下来
        dist.recv(t, src=parent)
        if trace is not None:
            trace.append({"phase": "bcast", "rank": rank, "recv_from": parent})
    for c in kids:
        dist.send(t, dst=c)
        sent += nbytes
        if trace is not None:
            trace.append({"phase": "bcast", "rank": rank, "send_to": c})
    return sent

def worker(ctx, cfg):
    """同一份输入分别走 手写Tree / 手写Ring / NCCL，比正确性也比时间。"""
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    depth = math.ceil(math.log2(P))
    rows = []
    for nbytes in cfg["sizes"]:
        elems = max(P, (nbytes // 4) // P * P)
        real = elems * 4
        base = torch.randn(elems, device=ctx.device)

        ref = base.clone()
        dist.all_reduce(ref)
        mine = base.clone()
        sent_tree = tree_allreduce(mine, ctx)
        err_tree = float((mine - ref).abs().max().item())
        mine_r = base.clone()
        sent_ring = exp03.ring_allreduce(mine_r, ctx)
        err_ring = float((mine_r - ref).abs().max().item())

        big = real > (1 << 24)
        plan = dict(warmup=2, iters=5 if big else 10, inner=1)
        b1 = base.clone()
        t_tree = common.time_op(lambda: tree_allreduce(b1, ctx), **plan)
        b2 = base.clone()
        t_ring = common.time_op(lambda: exp03.ring_allreduce(b2, ctx), **plan)
        b3 = base.clone()
        t_nccl = common.time_op(lambda: dist.all_reduce(b3), **plan)

        rows.append({
            "bytes": real,
            "tree_us": t_tree["p50_us"],
            "ring_us": t_ring["p50_us"],
            "nccl_us": t_nccl["p50_us"],
            "tree_over_ring": t_tree["p50_us"] / t_ring["p50_us"],
            "tree_busbw": common.bandwidth("all_reduce", real, t_tree["p50_us"], P)["busbw_GBps"],
            "ring_busbw": common.bandwidth("all_reduce", real, t_ring["p50_us"], P)["busbw_GBps"],
            "nccl_busbw": common.bandwidth("all_reduce", real, t_nccl["p50_us"], P)["busbw_GBps"],
            "tree_sent_bytes": sent_tree,
            "ring_sent_bytes": sent_ring,
            "tree_rounds_critical_path": 2 * depth,
            "ring_rounds": 2 * (P - 1),
            "err_tree": err_tree,
            "err_ring": err_ring,
        })
        del base, ref, mine, mine_r, b1, b2, b3
        torch.cuda.empty_cache()
        dist.barrier()
    return {"rank": ctx.rank, "rows": rows}

def structure(ctx, cfg):
    """记录树结构本身，便于在报告里画出父子关系。"""
    P, rank = ctx.world_size, ctx.rank
    return {
        "rank": rank,
        "parent": (rank - 1) // 2 if rank > 0 else None,
        "children": [c for c in (2 * rank + 1, 2 * rank + 2) if c < P],
        "depth": (rank + 1).bit_length() - 1,
        "node_index": ctx.node_index,
    }

def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--layouts", nargs="*", default=["1x8", "2x8"])
    ap.add_argument("--min-bytes", type=int, default=1 << 12)
    ap.add_argument("--max-bytes", type=int, default=1 << 28)
    ap.add_argument("--factor", type=int, default=16)
    ap.add_argument("--out", default="exp04_tree_allreduce")
    args = ap.parse_args()

    common.init_ray()
    # exp03 不是 __main__，默认会按引用序列化；远端没有这个文件，必须按值发过去
    ray.cloudpickle.register_pickle_by_value(exp03)

    sizes = common.sizes_pow2(args.min_bytes, args.max_bytes, args.factor)
    payload = {"structure": {}, "perf": {}}
    for tag in args.layouts:
        nn, np_ = (int(x) for x in tag.split("x"))
        st, _ = common.run_dist(structure, nnodes=nn, nproc_per_node=np_,
                                label=f"exp04_struct_{tag}")
        payload["structure"][tag] = st
        r, _ = common.run_dist(worker, nnodes=nn, nproc_per_node=np_,
                               cfg={"sizes": sizes}, label=f"exp04_perf_{tag}")
        payload["perf"][tag] = {"world_size": nn * np_, "rows": r[0]["rows"]}
        common.save_json(args.out, payload)

if __name__ == "__main__":
    main()

```

Binary tree：`parent = (r-1)//2`，`children = 2r+1, 2r+2`。 阶段一叶子→根 Reduce，阶段二根→叶子 Broadcast，关键路径 2 log2 P 轮。

1x8 的树形（深度 3）：

TEXT

```text
        0
      /   \
     1     2
    / \   / \
   3   4 5   6
  /
 7
```

### Ring vs Tree（都是手写版，同一份输入，误差均 ≈1e-6 的浮点顺序差）

单机 1x8：

| size   | Tree(us) | Ring(us) | Tree/Ring | NCCL(us) |
| ------ | -------- | -------- | --------- | -------- |
| 4KiB   | 218.4    | 1031.1   | **0.21**  | 42.9     |
| 64KiB  | 218.7    | 931.9    | 0.23      | 44.7     |
| 1MiB   | 220.6    | 909.1    | 0.24      | 53.6     |
| 16MiB  | 675.3    | 918.8    | 0.74      | 145.9    |
| 256MiB | 7548.4   | 7936.9   | **0.95**  | 1298.4   |

跨机 2x8：

| size   | Tree(us) | Ring(us) | Tree/Ring | NCCL(us) |
| ------ | -------- | -------- | --------- | -------- |
| 4KiB   | 4809.6   | 3006.9   | 1.60      | 2428.8   |
| 64KiB  | 2617.0   | 3028.2   | 0.86      | 2448.2   |
| 1MiB   | 2758.2   | 3442.9   | 0.80      | 2472.6   |
| 16MiB  | 8054.1   | 4266.0   | **1.89**  | 2692.0   |
| 256MiB | 75859.5  | 35276.9  | **2.15**  | 3590.2   |

### 对比表

| 观察项        | Ring           | Tree                  |
| ---------- | -------------- | --------------------- |
| 通信轮数（P=8）  | 2(P-1) = 14    | 2⌈log2 P⌉ = 6         |
| 通信轮数（P=16） | 30             | 8                     |
| 小消息延迟      | 差（轮数多，1031us）  | 好（218us，快 4.7 倍）      |
| 大消息带宽      | 好              | 差（跨机 256MiB 慢 2.15 倍） |
| Rank 增加的影响 | 轮数线性增长，小消息迅速恶化 | 轮数对数增长，扩展性好           |
| 链路并行利用     | 每条边同时收发，利用率均衡  | 只有树上的边在用，且分层串行        |
| 根/中间节点压力   | 无热点            | 根节点要收/发 2 份，是瓶颈       |

**小消息看轮数、大消息看热点**，这两条曲线的交叉点在单机 8 卡约 16MiB （Tree/Ring 从 0.24 升到 0.74），跨机 16 卡在 1MiB~16MiB 之间 （0.80 → 1.89）。跨机交叉点明显左移，因为跨机的每一跳都更贵， Tree 根节点的串行瓶颈更早暴露。

**总结起来就是小消息用tree，大消息用ring**

![[大模型 GPU 集合通信学习实践-03.png]]

手写 Tree 在跨机大消息上差 2 倍是**rank→树映射把最贵的链路用得最多**导致的，不是 Tree 算法本身不行，而是我们手写很难知道哪个链路费用最贵，哪个链路费用最低。

### NVLS 开关收益对照（p50，us）

NVLS 就是我们说的nv sharp, 前面聊过,这就是让 NVSwitch 芯片自己做规约加法，而不是让各 GPU 用 SM 算。数据一次上行进 switch、switch 内部求和、结果 multicast 广播回来，替代 Ring 绕环或 Tree 分层。

| size   | 1x8 Auto   | 1x8 NVLS\_off | 1x8 收益     | 2x8 Auto | 2x8 NVLS\_off | 2x8 收益 |
| ------ | ---------- | ------------- | ---------- | -------- | ------------- | ------ |
| 1KiB   | 36.5       | **26.7**      | −27%（反而变慢） | 274.2    | 297.3         | +8%    |
| 16KiB  | 35.3       | **27.0**      | −24%       | 281.1    | 302.3         | +8%    |
| 1MiB   | 39.3       | **30.0**      | −24%       | 315.5    | 349.7         | +11%   |
| 16MiB  | 135.1      | 143.3         | +6%        | 1389.1   | 1421.8        | +2%    |
| 64MiB  | 354.4      | 390.2         | +10%       | 1651.6   | 1797.7        | +9%    |
| 256MiB | 1263.2     | 1402.3        | +11%       | 3603.9   | 4209.6        | +17%   |
| 1GiB   | **4368.0** | 5374.8        | **+23%**   | —        | —             | —      |

（"收益"= NVLS\_off 相对 Auto 慢多少；正数表示 NVLS 有用。）

![[大模型 GPU 集合通信学习实践-04.png]]

上排是绝对延迟（实线 Auto = NVLS 开，虚线 NVLS\_off），下排是收益柱状图， 绿色向上表示 NVLS 有用、红色向下表示 NVLS 拖慢，零线就是盈亏平衡点。 图里画了 JSON 里全部 10 ~ 11 个 size（表格只摘了 67 个），因此多暴露两件事：

- **1x8 的盈亏交叉点在 1MiB~4MiB 之间**（1MiB 还是 −24%，4MiB 已经翻正到 +2%）， 这个位置比只看表格猜的要靠前。
- **大消息 NVLS 确实值钱**：单机 1GiB 快 23%，这就是实验一里 busbw 算出 436 GB/s（超过 H800 单向 NVLink 上限）的来源： 规约发生在 NVSwitch 里，链路上只跑一份数据，busbw 公式的前提被打破了。
- **小消息 NVLS 是负收益**：1x8 上 < 1MiB 时禁用 NVLS 反而快 24~27%（30.0 vs 39.3us）。 NVLS 需要 multicast buffer 注册与 switch 侧资源准备，这笔固定开销在 几十微秒量级的操作上占比过大。**延迟敏感、消息很小的场景（比如推理里的小 AllReduce）， `NCCL_NVLS_ENABLE=0` 是一个真实可用的优化选项。**
- **跨机 NVLS 仍有 2~17% 的收益**：跨机 AllReduce 的机内那一段规约依然走 NVSwitch， 所以即使瓶颈在网络，关掉 NVLS 也会变慢。

## 实验五 传输路径消融实验

### 代码

PYTHON

```python
"""实验六：传输路径消融（教程"实验六"）。

回答"性能来自 NVLink / GPU P2P / RDMA / GPUDirect 还是普通 Socket"，分三组:
A. 单机 8 卡: 默认 vs NCCL_P2P_DISABLE=1
B. 两机 16 卡: 默认（RoCE verbs）vs NCCL_NET=Socket
C. 两机 16 卡: 全部 8 张 400Gb HCA vs 只用 1 张（NCCL_IB_HCA='=mlx5_3'）

注意 mlx5_3 是两台机器都存在的 400Gb 设备（Node0 是 mlx5_2..9，Node1 是 mlx5_0,3..9），
所以单 HCA 实验挑它，避免一个环境变量在两台机器上语义不同。

所有消融变量都只存在于该次 run_dist 的 actor 生命周期内，实验结束自动消失。

用法: python exp06_path_ablation.py
"""

import argparse
import os
import time

import common

def nvlink_counters():
    """读本 rank 所用 GPU 的 NVLink 累计 Tx/Rx 字节。

    这是 DCGM 的平替: `nvidia-smi nvlink -gt d` 给出每条链路的累计计数器，
    在测量前后各读一次做差分，就能知道这段通信实际压了多少字节到 NVLink 上。
    -i 用的是物理 GPU 编号，Ray 把它放在 CUDA_VISIBLE_DEVICES 里。
    """
    dev = os.environ.get("CUDA_VISIBLE_DEVICES", "0").split(",")[0]
    out = common._sh(f"nvidia-smi nvlink -gt d -i {dev}")
    tx = rx = 0
    for ln in out.splitlines():
        parts = ln.split()
        if "Tx:" in ln and parts and parts[-1] == "KiB":
            tx += int(parts[-2])
        elif "Rx:" in ln and parts and parts[-1] == "KiB":
            rx += int(parts[-2])
    return {"tx_KiB": tx, "rx_KiB": rx}

def worker(ctx, cfg):
    """测 allreduce / allgather / reduce_scatter / sendrecv，并记录进程 CPU 占用。"""
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    rows = []
    nvl_before = nvlink_counters() if cfg.get("nvlink") else None
    for nbytes in cfg["sizes"]:
        elems = max(P, (nbytes // 4) // P * P)
        real = elems * 4
        dev = ctx.device
        buf = torch.randn(elems, device=dev)
        shard = torch.empty(elems // P, device=dev)
        out = torch.empty(elems, device=dev)
        send = torch.randn(elems, device=dev)
        recv = torch.empty(elems, device=dev)
        nxt, prv = (ctx.rank + 1) % P, (ctx.rank - 1) % P

        def sendrecv():
            for r in dist.batch_isend_irecv([
                dist.P2POp(dist.isend, send, nxt),
                dist.P2POp(dist.irecv, recv, prv),
            ]):
                r.wait()

        big = real > (1 << 24)
        plan = dict(warmup=3, iters=8 if big else 15, inner=1 if big else 4)
        cpu0, wall0 = os.times(), time.time()
        t_ar = common.time_op(lambda: dist.all_reduce(buf), **plan)
        t_ag = common.time_op(lambda: dist.all_gather_into_tensor(out, shard), **plan)
        t_rs = common.time_op(lambda: dist.reduce_scatter_tensor(shard, buf), **plan)
        t_sr = common.time_op(sendrecv, **plan)
        cpu1, wall1 = os.times(), time.time()
        cpu_busy = ((cpu1[0] - cpu0[0]) + (cpu1[1] - cpu0[1])) / max(1e-9, wall1 - wall0)

        rows.append({
            "bytes": real,
            "all_reduce_us": t_ar["p50_us"],
            "all_gather_us": t_ag["p50_us"],
            "reduce_scatter_us": t_rs["p50_us"],
            "sendrecv_us": t_sr["p50_us"],
            "all_reduce_busbw": common.bandwidth("all_reduce", real, t_ar["p50_us"], P)["busbw_GBps"],
            "sendrecv_busbw": common.bandwidth("sendrecv", real, t_sr["p50_us"], P)["busbw_GBps"],
            "cpu_busy_cores": round(cpu_busy, 2),
        })
        del buf, shard, out, send, recv
        torch.cuda.empty_cache()
        dist.barrier()
    res = {"rank": ctx.rank, "rows": rows}
    if nvl_before is not None:
        after = nvlink_counters()
        res["nvlink_delta_MiB"] = {
            "tx": (after["tx_KiB"] - nvl_before["tx_KiB"]) / 1024,
            "rx": (after["rx_KiB"] - nvl_before["rx_KiB"]) / 1024,
        }
    return res

CASES = [
    # (名字, 布局, 额外环境变量)
    ("A_single_node_default", "1x8", {}),
    ("A_single_node_p2p_disabled", "1x8", {"NCCL_P2P_DISABLE": "1"}),
    ("B_two_node_default_ib", "2x8", {}),
    ("B_two_node_net_socket", "2x8", {"NCCL_NET": "Socket"}),
    ("C_two_node_all_hca", "2x8", {}),
    ("C_two_node_single_hca", "2x8", {"NCCL_IB_HCA": "=mlx5_3"}),
]

def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--min-bytes", type=int, default=1 << 14)
    ap.add_argument("--max-bytes", type=int, default=1 << 28)
    ap.add_argument("--factor", type=int, default=16)
    ap.add_argument("--only", nargs="*", default=None, help="只跑指定 case 名")
    ap.add_argument("--nvlink", action="store_true",
                    help="用 nvidia-smi nvlink 计数器统计这轮实际的 NVLink 流量")
    ap.add_argument("--out", default="exp06_path_ablation")
    args = ap.parse_args()

    sizes = common.sizes_pow2(args.min_bytes, args.max_bytes, args.factor)
    payload = {"meta": {"sizes": sizes}, "cases": {}}
    for name, tag, env in CASES:
        if args.only and name not in args.only:
            continue
        nn, np_ = (int(x) for x in tag.split("x"))
        try:
            res, infos = common.run_dist(worker, nnodes=nn, nproc_per_node=np_,
                                         cfg={"sizes": sizes, "nvlink": args.nvlink},
                                         env=env, label=name)
            payload["cases"][name] = {"layout": tag, "env": env,
                                      "rows": res[0]["rows"],
                                      "nvlink_delta_MiB": res[0].get("nvlink_delta_MiB"),
                                      "cpu_busy_cores_max": max(
                                          r["cpu_busy_cores"] for x in res for r in x["rows"])}
        except Exception as e:
            payload["cases"][name] = {"layout": tag, "env": env,
                                      "error": f"{type(e).__name__}: {str(e)[:300]}"}
            print(f"[skip] {name}: {type(e).__name__}")
        common.save_json(args.out, payload)

if __name__ == "__main__":
    main()

```

### A 组：单机禁用 GPU P2P（NCCL\_P2P\_DISABLE=1）

禁用 P2P 后通信，通路走的是"GPU→host shared memory→GPU, 而不是走点对点的nvlink直连，要绕一次mem的；

| 指标                    | 默认（NVLink P2P） | P2P 禁用     | 变化       |
| --------------------- | -------------- | ---------- | -------- |
| AllReduce 16KiB       | 30.6us         | 80.9us     | 慢 2.6 倍  |
| AllReduce 4MiB        | 59.9us         | 109.4us    | 慢 1.8 倍  |
| AllReduce 64MiB       | 374.2us        | 502.0us    | 慢 1.34 倍 |
| AllReduce 64MiB busbw | 313.9 GB/s     | 233.9 GB/s | 降 25%    |
| SendRecv 64MiB        | 1108.7us       | 3139.1us   | 慢 2.8 倍  |
| 进程 CPU 占用（核）          | 0.8            | 1.9        | **翻倍**   |

由于要绕路cpu， 所以 **CPU 占用从 0.8 核涨到 1.9 核**——这是最能说明"数据换了路径"的证据。

纯点对点（SendRecv）受影响最大（2.8 倍），因为它没有 AllReduce 那样的 多路并行可以摊薄；而大消息 AllReduce 只慢 1.34 倍，说明 NCCL 在 P2P 不可用时 仍能用多 channel + SHM 把带宽拉到 234 GB/s。

#### 什么是多channel + SHM?

**channel = NCCL 内部一条独立的并行通信流水线**。一次 AllReduce 不是串行搬一整块数据，NCCL 会把它切成 N 份交给 N 个 channel 同时跑，每个 channel 有自己的一套 ring/tree 实例、自己的缓冲区，映射到一组 CUDA block（也就是占用一部分 SM）。

调节旋钮是 NCCL\_MIN\_NCHANNELS / NCCL\_MAX\_NCHANNELS。但要注意代价：channel 多了会吃 SM，和模型计算抢资源。所以它不是越多越好，这也是实验七做通信/计算重叠时的一个隐含变量

**SHM transport = 用主机的一块 pinned 共享内存做中转站**：`GPU A → 主机内存 → GPU B`。它是 P2P 不可用时的机内备用通路，就是上一轮聊的那条退化路径。单跳比 NVLink 慢得多，而且要 CPU 参与，这就是 CPU 占用从 0.8 涨到 1.9 核的来源。

### B 组：跨机强制走 Socket 不走rdma（NCCL\_NET=Socket）

| 指标                    | 默认（RoCE verbs + GDR） | NCCL\_NET=Socket | 变化       |
| --------------------- | -------------------- | ---------------- | -------- |
| AllReduce 16KiB       | 1211us               | 8538us           | 慢 7.0 倍  |
| AllReduce 4MiB        | 1335us               | 6708us           | 慢 5.0 倍  |
| AllReduce 64MiB       | 7264us               | 47250us          | 慢 6.5 倍  |
| AllReduce 64MiB busbw | 17.3 GB/s            | 2.7 GB/s         | *降到 1/6* |
| SendRecv 64MiB        | 6567us               | 38954us          | 慢 5.9 倍  |
| 进程 CPU 占用（核）          | 1.9                  | 2.0              | 略升       |

Socket 路径要经过内核 TCP 栈、多次内存拷贝，而且走的是 100Gb 的 `bond0` 管理网而不是 8×400Gb 的 RoCE，两个因素叠加得到 6~7 倍差距。 `busbw` 掉到 2.7 GB/s ，正是单条 TCP 流在 100Gb 网卡上的典型水平。

### C 组：单 网卡 vs 全部 8 张 网卡（NCCL\_IB\_HCA='=mlx5\_3'）

**HCA = Host Channel Adapter**，InfiniBand 术语里对网卡的叫法，就是那块 RDMA 网卡本身。

NIC 是“网卡”的泛称，HCA 是面向 RDMA/InfiniBand 场景的一类高性能网卡/主机适配器。

| 指标                    | 8 张 400Gb HCA | 只用 mlx5\_3 | 比值       |
| --------------------- | ------------- | ---------- | -------- |
| AllReduce 16KiB       | 1205us        | 4034us     | 3.3x     |
| AllReduce 4MiB        | 1274us        | 4171us     | 3.3x     |
| AllReduce 64MiB       | 5122us        | 12491us    | 2.4x     |
| AllReduce 64MiB busbw | 24.6 GB/s     | 10.1 GB/s  | **2.4x** |

**8 张 HCA 相对 1 张只快 2.4 倍，远不到线性的 8 倍。** 这说明 16 卡 AllReduce 在 64MiB 这个 size 上并没有把 8 个 rail 都压满—— 瓶颈在算法结构（跨机跳数、Tree 的层级串行）而不是 NIC 数量。 要看到接近线性的 rail 聚合，需要更大的消息和 rail-optimized 的通信模式。

## 实验六 通信与计算overlap

### 代码

PYTHON

```python
"""实验七：通信与计算重叠（教程"实验七"）。

三种实现:
  A. GEMM 完成后同步执行 AllReduce（完全串行）
  B. 在独立 CUDA Stream 上异步启动 AllReduce，同时执行无数据依赖的 GEMM
  C. 把 Tensor / GEMM 切成 K 块，让第 i 块的通信与第 i+1 块的计算流水

重叠效率:
  E_overlap = (T_comp + T_comm - T_total) / min(T_comp, T_comm)
  接近 0 = 基本没隐藏；接近 1 = 短的那部分被完全覆盖。

用法:
  python exp07_overlap.py
  python exp07_overlap.py --layouts 1x8
"""

import argparse

import common

# (M, K, N) GEMM 形状 + AllReduce 字节数；覆盖"计算多/通信多"两种比例
COMBOS = [
    {"gemm": (4096, 4096, 4096), "bytes": 64 << 20},
    {"gemm": (8192, 8192, 8192), "bytes": 64 << 20},
    {"gemm": (4096, 4096, 4096), "bytes": 512 << 20},
    {"gemm": (8192, 8192, 8192), "bytes": 512 << 20},
]
# PLACEHOLDER_WORKER

def worker(ctx, cfg):
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    dev = ctx.device
    comm_stream = torch.cuda.Stream(device=dev)
    rows = []

    for combo in cfg["combos"]:
        m, k, n = combo["gemm"]
        elems = max(P, (combo["bytes"] // 4) // P * P)
        real = elems * 4
        A = torch.randn(m, k, device=dev, dtype=torch.bfloat16)
        B = torch.randn(k, n, device=dev, dtype=torch.bfloat16)
        buf = torch.randn(elems, device=dev)
        plan = dict(warmup=3, iters=10, inner=1)

        t_comp = common.time_op(lambda: torch.mm(A, B), **plan)["p50_us"]
        t_comm = common.time_op(lambda: dist.all_reduce(buf), **plan)["p50_us"]

        def plan_a():  # 串行: 先算完再通信
            torch.mm(A, B)
            dist.all_reduce(buf)

        def plan_b():  # 通信放到独立 stream，与无依赖的 GEMM 并行
            cur = torch.cuda.current_stream()
            comm_stream.wait_stream(cur)
            with torch.cuda.stream(comm_stream):
                dist.all_reduce(buf)
            torch.mm(A, B)
            cur.wait_stream(comm_stream)  # 让计时 end event 排在通信之后

        K = cfg.get("chunks", 4)
        a_rows = A.chunk(K, dim=0)
        buf_chunks = list(buf.chunk(K))

        def plan_c():  # 分块流水: 第 i 块通信与第 i+1 块计算重叠
            cur = torch.cuda.current_stream()
            for i in range(K):
                torch.mm(a_rows[i], B)
                comm_stream.wait_stream(cur)
                with torch.cuda.stream(comm_stream):
                    dist.all_reduce(buf_chunks[i])
            cur.wait_stream(comm_stream)

        res = {}
        for name, fn in (("A_serial", plan_a), ("B_async_stream", plan_b),
                         ("C_chunked_pipeline", plan_c)):
            t = common.time_op(fn, **plan)["p50_us"]
            denom = min(t_comp, t_comm)
            res[name] = {
                "total_us": t,
                "e_overlap": (t_comp + t_comm - t) / denom if denom > 0 else 0.0,
                "exposed_comm_us": max(0.0, t - t_comp),
            }

        rows.append({
            "gemm": [m, k, n],
            "bytes": real,
            "chunks": K,
            "t_comp_us": t_comp,
            "t_comm_us": t_comm,
            "comm_over_comp": t_comm / t_comp,
            "plans": res,
        })
        del A, B, buf
        torch.cuda.empty_cache()
        dist.barrier()
    return {"rank": ctx.rank, "rows": rows}

def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--layouts", nargs="*", default=["1x8", "2x8"])
    ap.add_argument("--chunks", type=int, default=4)
    ap.add_argument("--out", default="exp07_overlap")
    args = ap.parse_args()

    payload = {"meta": {"combos": COMBOS, "chunks": args.chunks}, "data": {}}
    for tag in args.layouts:
        nn, np_ = (int(x) for x in tag.split("x"))
        res, _ = common.run_dist(worker, nnodes=nn, nproc_per_node=np_,
                                 cfg={"combos": COMBOS, "chunks": args.chunks},
                                 label=f"exp07_{tag}")
        payload["data"][tag] = {"world_size": nn * np_, "rows": res[0]["rows"]}
        common.save_json(args.out, payload)

if __name__ == "__main__":
    main()

```

三种实现：A 串行；

B 通信放独立 CUDA Stream、与无依赖 GEMM 并行；

C 把 tensor 和 GEMM 都切 4 块做流水。

重叠效率 $E_{overlap}=\frac{T_{comp}+T_{comm}-T_{total}}{\min(T_{comp},T_{comm})}$。

### 单机 1x8

| GEMM  | AllReduce | T\_comp | T\_comm | comm/comp | A 串行            | B 异步 stream         | C 分块流水           |
| ----- | --------- | ------- | ------- | --------- | --------------- | ------------------- | ---------------- |
| 4096³ | 64MiB     | 239us   | 367us   | 1.54      | 588us (E=0.07)  | **430us (E=0.74)**  | 678us (E=-0.30)  |
| 8192³ | 64MiB     | 1643us  | 362us   | 0.22      | 2000us (E=0.02) | **1712us (E=0.82)** | 2076us (E=-0.19) |
| 4096³ | 512MiB    | 239us   | 2440us  | 10.23     | 2665us (E=0.08) | **2504us (E=0.73)** | 2688us (E=-0.04) |
| 8192³ | 512MiB    | 1647us  | 2442us  | 1.48      | 4065us (E=0.01) | **2698us (E=0.84)** | 3745us (E=0.21)  |

三条结论：

1. **方案 B 全线有效，**$E_{overlap}$ **稳定在 0.73~0.84**，与 comm/comp 配比（0.22~10.2） 基本无关。这是最典型也最有用的场景。
2. **分块流水（方案 C）在 3/4 的配置上是负收益**（E 从 −0.30 到 +0.21）。 把一次 512MiB AllReduce 切成 4 次 128MiB，既多付 4 次启动开销， 又让每块掉到带宽曲线更低的位置。唯一为正的是 `8192³ + 512MiB` （4065 → 3745us，E=0.21）——计算量大到足以覆盖切块损失的那一格。 **切块的收益是"更早开始通信"，代价是"每块的带宽更低"，后者通常更大。**

## 实验七：最小 Tensor Parallel MLP

### 代码

`script/exp08_tp_mlp.py`

PYTHON

```python
"""实验八：最小 Tensor Parallel MLP（教程"实验八"）。

结构: X -> ColumnParallelLinear(gate,up) -> SwiGLU -> RowParallelLinear -> Y

通信位置（不开 SP 时）:
  ColumnParallelLinear: 前向无通信；反向对 dX 做 AllReduce
  RowParallelLinear:    前向对局部输出做 AllReduce；反向无通信

验证: TP2/4/8/16 的输出与权重梯度都要和单卡参考实现一致（bf16 容差）。
测量: step 时间、通信时间占比（用"把通信换成 no-op"的对照组估算暴露通信）。

用法:
  python exp08_tp_mlp.py
  python exp08_tp_mlp.py --layouts 1x2 1x8 2x8 --hidden 4096
"""

import argparse

import common

# PLACEHOLDER

def build_module(ctx, cfg):
    """返回 (forward_fn, params, ref_state)。所有 rank 用同一份随机种子生成全量权重，
    再各自切片，这样才能和单卡参考对齐。"""
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    h, ffn = cfg["hidden"], cfg["ffn"]
    dev, dt = ctx.device, torch.bfloat16
    g = torch.Generator(device="cpu").manual_seed(1234)
    # 全量权重（CPU 上生成，保证每个 rank 完全一致）
    w1_full = torch.randn(2 * ffn, h, generator=g, dtype=torch.float32) / (h ** 0.5)
    w2_full = torch.randn(h, ffn, generator=g, dtype=torch.float32) / (ffn ** 0.5)
    x_full = torch.randn(cfg["tokens"], h, generator=g, dtype=torch.float32) / 8

    # Column Parallel: 按输出维度切 w1（gate 和 up 各自切，保持 SwiGLU 语义）
    gate_full, up_full = w1_full[:ffn], w1_full[ffn:]
    per = ffn // P
    s = slice(ctx.rank * per, (ctx.rank + 1) * per)
    gate = gate_full[s].to(dev, dt).clone().requires_grad_(True)
    up = up_full[s].to(dev, dt).clone().requires_grad_(True)
    # Row Parallel: 按输入维度切 w2
    w2 = w2_full[:, s].to(dev, dt).clone().requires_grad_(True)
    x = x_full.to(dev, dt).clone().requires_grad_(True)

    class ReduceFromTP(torch.autograd.Function):
        """RowParallel 的输出: 前向 AllReduce，反向 identity。"""

        @staticmethod
        def forward(ctx_, t):
            if cfg.get("comm", True):
                dist.all_reduce(t)
            return t

        @staticmethod
        def backward(ctx_, g_):
            return g_

    class CopyToTP(torch.autograd.Function):
        """ColumnParallel 的输入: 前向 identity，反向对 dX 做 AllReduce。"""

        @staticmethod
        def forward(ctx_, t):
            return t

        @staticmethod
        def backward(ctx_, g_):
            if cfg.get("comm", True):
                dist.all_reduce(g_)
            return g_

    def forward():
        xi = CopyToTP.apply(x)
        a = torch.nn.functional.silu(xi @ gate.t()) * (xi @ up.t())  # SwiGLU
        y = a @ w2.t()
        return ReduceFromTP.apply(y)

    return forward, {"gate": gate, "up": up, "w2": w2, "x": x}, {
        "gate_full": gate_full, "up_full": up_full, "w2_full": w2_full,
        "x_full": x_full, "shard": (ctx.rank * per, (ctx.rank + 1) * per),
    }

def reference_single_gpu(cfg, ref, dev):
    """单卡参考实现: 用全量权重直接算，作为正确性基准。"""
    import torch

    dt = torch.bfloat16
    gate = ref["gate_full"].to(dev, dt).clone().requires_grad_(True)
    up = ref["up_full"].to(dev, dt).clone().requires_grad_(True)
    w2 = ref["w2_full"].to(dev, dt).clone().requires_grad_(True)
    x = ref["x_full"].to(dev, dt).clone().requires_grad_(True)
    a = torch.nn.functional.silu(x @ gate.t()) * (x @ up.t())
    y = a @ w2.t()
    # 用 sum 而不是 mean: mean 会把梯度缩小 tokens*hidden 倍（到 1e-9 量级），
    # 在 bf16 下接近非规格化区间，正确性比对失去意义
    loss = y.float().pow(2).sum()
    loss.backward()
    return y, {"gate": gate.grad, "up": up.grad, "w2": w2.grad, "x": x.grad}

def worker(ctx, cfg):
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    fwd, params, ref = build_module(ctx, cfg)

    # --- 正确性: TP 结果 vs 单卡参考 ---
    y = fwd()
    loss = y.float().pow(2).sum()
    loss.backward()
    y_ref, g_ref = reference_single_gpu(cfg, ref, ctx.device)
    lo, hi = ref["shard"]
    checks = {
        "y_max_diff": float((y.float() - y_ref.float()).abs().max().item()),
        "y_rel": float(((y.float() - y_ref.float()).abs().max()
                        / y_ref.float().abs().max()).item()),
        "gate_grad_max_diff": float((params["gate"].grad.float()
                                     - g_ref["gate"][lo:hi].float()).abs().max().item()),
        "w2_grad_max_diff": float((params["w2"].grad.float()
                                   - g_ref["w2"][:, lo:hi].float()).abs().max().item()),
        "x_grad_max_diff": float((params["x"].grad.float()
                                  - g_ref["x"].float()).abs().max().item()),
        "gate_grad_scale": float(g_ref["gate"][lo:hi].float().abs().max().item()),
        "x_grad_scale": float(g_ref["x"].float().abs().max().item()),
    }
    del y_ref, g_ref
    torch.cuda.empty_cache()

    # --- 通信 shape 记录 ---
    shapes = {
        "row_parallel_fwd_allreduce": list(y.shape),
        "column_parallel_bwd_allreduce": list(params["x"].shape),
        "gate_shard": list(params["gate"].shape),
        "w2_shard": list(params["w2"].shape),
        "bytes_per_allreduce": y.numel() * 2,
    }

    # --- 计时: 完整 step vs 去掉通信的 step ---
    def step():
        for p in params.values():
            p.grad = None
        out = fwd()
        out.float().pow(2).sum().backward()

    t_full = common.time_op(step, warmup=3, iters=10)
    cfg_nocomm = dict(cfg)
    cfg_nocomm["comm"] = False
    fwd2, params2, _ = build_module(ctx, cfg_nocomm)

    def step_nocomm():
        for p in params2.values():
            p.grad = None
        out = fwd2()
        out.float().pow(2).sum().backward()

    t_nocomm = common.time_op(step_nocomm, warmup=3, iters=10)
    exposed = t_full["p50_us"] - t_nocomm["p50_us"]

    return {
        "rank": ctx.rank,
        "world_size": P,
        "host": ctx.host.split(".")[0],
        "checks": checks,
        "shapes": shapes,
        "step_us": t_full["p50_us"],
        "step_nocomm_us": t_nocomm["p50_us"],
        "exposed_comm_us": exposed,
        "comm_ratio": exposed / t_full["p50_us"],
        "peak_mem_MiB": torch.cuda.max_memory_allocated() / 1024 ** 2,
    }

def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--layouts", nargs="*", default=["1x1", "1x2", "1x4", "1x8", "2x8"])
    ap.add_argument("--tokens", type=int, default=8192)
    ap.add_argument("--hidden", type=int, default=4096)
    ap.add_argument("--ffn", type=int, default=11008)
    ap.add_argument("--out", default="exp08_tp_mlp")
    args = ap.parse_args()

    cfg = {"tokens": args.tokens, "hidden": args.hidden, "ffn": args.ffn, "comm": True}
    payload = {"meta": cfg, "data": {}}
    for tag in args.layouts:
        nn, np_ = (int(x) for x in tag.split("x"))
        res, _ = common.run_dist(worker, nnodes=nn, nproc_per_node=np_, cfg=cfg,
                                 label=f"exp08_tp{nn * np_}")
        payload["data"][f"TP{nn * np_}_{tag}"] = {
            "layout": tag, "world_size": nn * np_,
            "ranks": [{k: v for k, v in r.items() if k != "shapes"} for r in res],
            "shapes": res[0]["shapes"],
        }
        common.save_json(args.out, payload)

if __name__ == "__main__":
    main()

```

结构 `X → ColumnParallelLinear(gate,up) → SwiGLU → RowParallelLinear → Y`， 8192 token、hidden 4096、ffn 11008、bf16。 所有 rank 用同一个 CPU 随机种子生成**全量权重**再各自切片， 所以可以和"单卡拿全量权重直接算"的参考实现逐元素比对。

### 正确性（相对误差，bf16）

| 规模        | 输出 y   | gate 权重梯度 | 输入梯度 dX |
| --------- | ------ | --------- | ------- |
| TP1（单卡自比） | 0      | 0         | 0       |
| TP2       | 5.7e-3 | 3.7e-3    | 7.1e-3  |
| TP4       | 5.7e-3 | 3.7e-3    | 7.1e-3  |
| TP8       | 5.7e-3 | 3.7e-3    | 7.1e-3  |
| TP16（跨机）  | 5.7e-3 | 3.7e-3    | 7.1e-3  |

bf16 的机器精度约 7.8e-3，所以这些误差就是"切分后求和顺序不同"带来的浮点差异， 不随 TP degree 恶化，可以确认 TP 实现是对的。

### 通信发生的位置与 shape

| 算子                   | 前向                                   | 反向                                    |
| -------------------- | ------------------------------------ | ------------------------------------- |
| ColumnParallelLinear | 无通信                                  | 对 dX 做 AllReduce，shape \[8192, 4096\] |
| SwiGLU               | 无                                    | 无                                     |
| RowParallelLinear    | 对局部输出 AllReduce，shape \[8192, 4096\] | 无通信                                   |

**关键点：无论 TP 几，每次 AllReduce 的字节数都是 64MiB（8192×4096×2B）不变。** 变的只是权重分片：TP2 的 gate 是 \[5504, 4096\]，TP16 是 \[688, 4096\]。 这就是 TP 的通信特征——**通信量不随 TP degree 下降，计算量却按 TP degree 下降**， 所以 TP 越大，通信占比越高。

### step time 与通信占比

| 规模          | 完整 step | 去掉通信   | 暴露的通信  | 通信占比  | 峰值显存     |
| ----------- | ------- | ------ | ------ | ----- | -------- |
| TP1（单卡）     | 10594us | 9679us | 915us  | 8.6%  | 2448 MiB |
| TP2（单机）     | 5819us  | 5287us | 532us  | 9.1%  | 2193 MiB |
| TP4（单机）     | 4138us  | 3491us | 648us  | 15.7% | 2063 MiB |
| TP8（单机）     | 2831us  | 2160us | 670us  | 23.7% | 1997 MiB |
| TP16（跨 2 机） | 7018us  | 1486us | 5532us | 78.8% | 1964 MiB |

1. **计算部分一直在正常缩放**：9679 → 5287 → 3491 → 2160 → 1486us， 接近线性，TP16 的单卡 GEMM 只有单卡版的 15%。
2. **通信部分在单机内几乎不变**（532~670us），因为字节数固定、NVLink 带宽充裕。
3. **一旦跨机，通信从 670us 跳到 5532us（8.3 倍）**， 于是 TP16 的 step time 反而比 TP8 慢 2.5 倍（7018 vs 2831us）， 通信占比从 24% 飙到 79%。
4. TP16 的**计算确实更快了**（1486 vs 2160us），但省下的 674us 被多出来的 4862us 通信彻底吃掉。

**这就是TP 尽量不要跨出 NVLink 域的定量依据：** 在这台机器上，TP 从 8 扩到 16（跨机）会让 step time 恶化 2.5 倍，

## 实验八： 可控MoE Router与 all2all

### 代码

PYTHON

```python
"""实验十：可控 MoE Router 与 AllToAll（教程"实验十"）。

Toy dispatcher 流程:
  每 GPU 生成 T 个 token -> Router 决定目标 Expert/Rank -> 本地 permute/pack
  -> AllToAll Dispatch（变长）-> 本地伪 Expert GEMM -> AllToAll Combine
  -> Unpermute 恢复原始 token 顺序

三种路由分布: balanced / zipf(80-20) / extreme(几乎全打一个 Expert)

记录: 每 rank 发送与接收 token 数、max/mean、dispatch/combine/permute 时间、
      AllToAll 的 p50/p95/p99、最慢 rank 完成时间、P×P 通信矩阵。

用法:
  python exp10_moe_alltoall.py
  python exp10_moe_alltoall.py --layouts 1x8 2x8 --topk 1 2
"""

import argparse

import common

# PLACEHOLDER

def route(n_tokens, P, kind, topk, device, seed):
    """返回 (n_tokens*topk,) 的目标 rank。三种分布对应教程里的三种路由。"""
    import torch

    g = torch.Generator(device="cpu").manual_seed(seed)
    total = n_tokens * topk
    if kind == "balanced":
        dest = torch.arange(total) % P
    elif kind == "zipf":
        # 80-20: 前 20% 的 expert 拿掉大部分 token
        w = 1.0 / torch.arange(1, P + 1, dtype=torch.float32)
        dest = torch.multinomial(w, total, replacement=True, generator=g)
    elif kind == "extreme":
        # 90% 打到 expert 0，其余均分
        dest = torch.where(torch.rand(total, generator=g) < 0.9,
                           torch.zeros(total, dtype=torch.long),
                           torch.randint(0, P, (total,), generator=g))
    else:
        raise ValueError(kind)
    return dest.to(device)

def worker(ctx, cfg):
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    T, h, topk = cfg["tokens"], cfg["hidden"], cfg["topk"]
    dev, dt = ctx.device, torch.bfloat16
    rows = []

    for kind in cfg["kinds"]:
        dest = route(T, P, kind, topk, dev, seed=1000 + ctx.rank)
        x = torch.randn(T, h, device=dev, dtype=dt)
        x_rep = x.repeat_interleave(topk, dim=0) if topk > 1 else x

        # --- 本地 permute: 按目标 rank 排序，得到每个目标的连续块 ---
        ev = {}

        def timed_block(name, fn):
            s = torch.cuda.Event(enable_timing=True)
            e = torch.cuda.Event(enable_timing=True)
            s.record()
            out = fn()
            e.record()
            torch.cuda.synchronize()
            ev[name] = s.elapsed_time(e) * 1000.0
            return out

        order = timed_block("permute_us", lambda: torch.argsort(dest))
        sorted_x = x_rep[order].contiguous()
        send_counts = torch.bincount(dest, minlength=P)

        # 交换 counts，得到本 rank 会收到多少（这一步本身是个小 AllToAll）
        recv_counts = torch.empty_like(send_counts)
        dist.all_to_all_single(recv_counts, send_counts)
        s_list = send_counts.tolist()
        r_list = recv_counts.tolist()
        recv_total = sum(r_list)

        recv_buf = torch.empty(recv_total, h, device=dev, dtype=dt)
        W = torch.randn(h, h, device=dev, dtype=dt) / (h ** 0.5)

        def dispatch():
            dist.all_to_all_single(recv_buf, sorted_x,
                                   output_split_sizes=r_list, input_split_sizes=s_list)

        def expert_gemm():
            return recv_buf @ W

        combine_buf = torch.empty_like(sorted_x)

        def combine():
            dist.all_to_all_single(combine_buf, recv_buf,
                                   output_split_sizes=s_list, input_split_sizes=r_list)

        plan = dict(warmup=3, iters=15, inner=1)
        t_dispatch = common.time_op(dispatch, **plan)
        t_gemm = common.time_op(expert_gemm, **plan)
        t_combine = common.time_op(combine, **plan)

        # unpermute: 用 argsort 的逆恢复原始顺序，并验证 round-trip 正确
        dispatch()
        combine()
        inv = torch.argsort(order)
        restored = combine_buf[inv]
        rt_err = float((restored.float() - x_rep.float()).abs().max().item())

        # P×P 通信矩阵: 每个 rank 的 send_counts 拼起来
        matrix = torch.zeros(P, P, dtype=torch.long, device=dev)
        matrix[ctx.rank] = send_counts
        dist.all_reduce(matrix)

        recv_all = matrix.sum(dim=0)  # 每个 rank 实际收到的 token 数
        mean_recv = float(recv_all.float().mean().item())
        rows.append({
            "routing": kind,
            "topk": topk,
            "tokens_per_rank": T,
            "send_counts": s_list,
            "recv_counts": r_list,
            "recv_total": recv_total,
            "max_over_mean_recv": float(recv_all.max().item()) / mean_recv,
            "dispatch_p50_us": t_dispatch["p50_us"],
            "dispatch_p95_us": t_dispatch["p95_us"],
            "dispatch_p99_us": t_dispatch["p99_us"],
            "combine_p50_us": t_combine["p50_us"],
            "expert_gemm_p50_us": t_gemm["p50_us"],
            "permute_us": ev.get("permute_us"),
            "roundtrip_max_err": rt_err,
            "comm_matrix": matrix.tolist() if ctx.rank == 0 else None,
            "bytes_sent_per_rank": sum(s_list[i] for i in range(P) if i != ctx.rank) * h * 2,
        })
        del x, x_rep, sorted_x, recv_buf, combine_buf, W, matrix
        torch.cuda.empty_cache()
        dist.barrier()
    return {"rank": ctx.rank, "host": ctx.host.split(".")[0], "rows": rows}

def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--layouts", nargs="*", default=["1x8", "2x8"])
    ap.add_argument("--tokens", type=int, default=4096)
    ap.add_argument("--hidden", type=int, default=4096)
    ap.add_argument("--topk", nargs="*", type=int, default=[1, 2])
    ap.add_argument("--kinds", nargs="*", default=["balanced", "zipf", "extreme"])
    ap.add_argument("--out", default="exp10_moe_alltoall")
    args = ap.parse_args()

    payload = {"meta": vars(args), "data": {}}
    for tag in args.layouts:
        nn, np_ = (int(x) for x in tag.split("x"))
        for k in args.topk:
            cfg = {"tokens": args.tokens, "hidden": args.hidden, "topk": k,
                   "kinds": args.kinds}
            res, _ = common.run_dist(worker, nnodes=nn, nproc_per_node=np_, cfg=cfg,
                                     label=f"exp10_{tag}_top{k}")
            payload["data"][f"{tag}_top{k}"] = {
                "layout": tag, "world_size": nn * np_,
                "rank0": res[0]["rows"],
                "per_rank_dispatch_p50": {r["rank"]: [x["dispatch_p50_us"] for x in r["rows"]]
                                          for r in res},
            }
            common.save_json(args.out, payload)

if __name__ == "__main__":
    main()

```

流程完整实现了教程的 Toy Dispatcher： Router → 本地 permute/pack → 变长 AllToAll dispatch（先用一次小 AllToAll 交换 counts） → 伪 Expert GEMM → AllToAll combine → unpermute。 **每种配置的 round-trip 误差都是 0**，即 permute/dispatch/combine/unpermute 完全可逆。

### 负载不均衡直接决定 AllToAll 时间

**balanced:**

TEXT

```text

dest = torch.arange(total) % P
```

**轮询**——token 0 给 rank 0、token 1 给 rank 1……严格均分，不带随机性。每个 rank 恰好收到 `4096` 个 token，`max/mean = 1.00`。这是理论最优基线，现实中不存在（真实 router 由 gating 网络学出来，不可能这么整齐）。

**zipf**

TEXT

```text
w = 1.0 / torch.arange(1, P + 1)          # 权重 1, 1/2, 1/3, ... 1/P
dest = torch.multinomial(w, total, replacement=True)
```

按 **Zipf 分布**（幂律）采样，第 ii 个 expert 的权重是 1/i1/i。代码注释写的是"80-20"——前 20% 的 expert 拿掉大部分 token。这**模拟真实 MoE 的典型状态**：训练中总有几个 expert 更受欢迎，长尾 expert 门可罗雀。

![[大模型 GPU 集合通信学习实践-05.png]]

**extreme**

TEXT

```text
dest = torch.where(rand < 0.9, 0, randint(0, P))
```

**90% 的 token 全打到 expert 0**，剩下 10% 随机撒。这是压力测试用的病态情形，对应 router 崩溃（collapse）——训练早期或 load balancing loss 失效时会真的出现。

讲完分布以后看数据： 每 rank 4096 token、hidden 4096、top-1：

| 布局  | 路由分布     | max/mean 收到的 token | Dispatch p50 | Dispatch p95 | Dispatch p99 | Combine p50 |
| --- | -------- | ------------------ | ------------ | ------------ | ------------ | ----------- |
| 1x8 | balanced | 1.00               | 178us        | 4640us       | 4641us       | 166us       |
| 1x8 | zipf     | 2.97               | 282us        | 4702us       | 4703us       | 2506us      |
| 1x8 | extreme  | 7.29               | **9195us**   | 13685us      | 13693us      | 636us       |
| 2x8 | balanced | 1.00               | 5006us       | 5231us       | 5251us       | 5101us      |
| 2x8 | zipf     | 4.72               | 4051us       | 4060us       | 15151us      | 14142us     |
| 2x8 | extreme  | **14.49**          | **56849us**  | 67945us      | 68145us      | 50061us     |

- **单机 1x8：从均衡到极端不均衡，Dispatch 从 178us 涨到 9195us，慢 51 倍**， 而总通信字节数几乎没变（都是 4096 个 token 发出去）。 **AllToAll 的瓶颈不是总带宽，是最热的那个 Expert。**
- **跨机 2x8 更严重：balanced 5006us → extreme 56849us（11 倍）**， 而且 max/mean 从 1.00 恶化到 14.49。16 卡时热点更集中（所有 rank 都往 rank0 发）， rank0 那一张 400Gb NIC 要接收 15 倍于平均的流量。
- **p99 揭示尾延迟**：2x8 zipf 的 p50 只有 4051us，但 p99 是 15151us（3.7 倍）。 如果只看平均值会完全漏掉这个尾巴——教程说"MoE 不能只看平均带宽"就是这个意思。

### Top-K 的影响

| 布局  | 路由       | top-1 dispatch | top-2 dispatch | 倍数   |
| --- | -------- | -------------- | -------------- | ---- |
| 1x8 | balanced | 178us          | 4666us         | 26x  |
| 1x8 | zipf     | 282us          | 9161us         | 32x  |
| 2x8 | balanced | 5006us         | 13991us        | 2.8x |
| 2x8 | zipf     | 4051us         | 40903us        | 10x  |
| 2x8 | extreme  | 56849us        | **121990us**   | 2.1x |

top-2 把通信量翻倍，但时间涨得远超 2 倍（单机 26~ 32 倍）。 单机那两个夸张的倍数要打折看——top-1 balanced 的 178us 本身太小， 容易被固定开销主导；但跨机的 2.110 倍是实打实的， 说明 **top-K 增加不只是线性增加字节，还会加剧不均衡带来的排队**。

## 实验九：真实 Transformer 的通信 Timeline

### 代码

`script/exp12_transformer_timeline.py`，

PYTHON

```python
"""实验十二：真实 Transformer 的通信 Timeline（教程"实验十二"）。

同一个小 Transformer 分别用 DDP / FSDP / TP / TP+SP 跑，用 torch.profiler 抓
CUDA kernel，统计每种并行方式下:
- step 时间
- NCCL kernel 总时间（并按 kernel 名区分 AllReduce / ReduceScatter / AllGather）
- GEMM/attention kernel 时间
- 通信占 step 的比例

trace 文件（体积大）写到 /target/comm-lab-traces/，可以用 chrome://tracing 或
Perfetto 打开，对应教程里 Nsight Systems 的角色。
nsys 命令（可选，需要更细的时间线时用）:
  nsys profile -t cuda,nvtx,osrt -o /target/comm-lab-traces/exp12 \
      python exp12_transformer_timeline.py --modes tp

用法:
  python exp12_transformer_timeline.py
  python exp12_transformer_timeline.py --modes ddp fsdp tp tp_sp --layout 2x8
"""

import argparse
import os

import common

TRACE_DIR = "/target/comm-lab-traces"

def make_model(cfg):
    """普通（非并行）Transformer Block 堆叠，供 DDP / FSDP 使用。"""
    import torch
    import torch.nn as nn

    h, heads, ffn = cfg["hidden"], cfg["heads"], cfg["ffn"]

    class Block(nn.Module):
        def __init__(self):
            super().__init__()
            self.n1 = nn.LayerNorm(h)
            self.qkv = nn.Linear(h, 3 * h, bias=False)
            self.o = nn.Linear(h, h, bias=False)
            self.n2 = nn.LayerNorm(h)
            self.gate = nn.Linear(h, ffn, bias=False)
            self.up = nn.Linear(h, ffn, bias=False)
            self.down = nn.Linear(ffn, h, bias=False)

        def forward(self, x):
            B, S, _ = x.shape
            r = x
            q, k, v = self.qkv(self.n1(x)).chunk(3, dim=-1)
            q = q.view(B, S, heads, -1).transpose(1, 2)
            k = k.view(B, S, heads, -1).transpose(1, 2)
            v = v.view(B, S, heads, -1).transpose(1, 2)
            a = torch.nn.functional.scaled_dot_product_attention(q, k, v, is_causal=True)
            x = r + self.o(a.transpose(1, 2).reshape(B, S, h))
            r = x
            y = self.n2(x)
            return r + self.down(torch.nn.functional.silu(self.gate(y)) * self.up(y))

    return nn.Sequential(*[Block() for _ in range(cfg["layers"])])

def tp_step_fn(ctx, cfg, sp=False):
    """手写 TP（可选 SP）的 Transformer Block: attention 按 head 切，MLP 按 ffn 切。"""
    import torch
    import torch.distributed as dist

    P = ctx.world_size
    h, heads, ffn, L = cfg["hidden"], cfg["heads"], cfg["ffn"], cfg["layers"]
    B, S = cfg["batch"], cfg["seq"]
    dev, dt = ctx.device, torch.bfloat16
    assert heads % P == 0 and ffn % P == 0
    hp, fp = h // P, ffn // P

    def par(*shape):
        return (torch.randn(*shape, device=dev, dtype=dt) / shape[-1] ** 0.5).requires_grad_(True)

    layers = [{"qkv": par(3 * hp, h), "o": par(h, hp),
               "gate": par(fp, h), "up": par(fp, h), "down": par(h, fp)}
              for _ in range(L)]
    x0 = (torch.randn(B, S // (P if sp else 1), h, device=dev, dtype=dt) / 8).requires_grad_(True)

    class AllReduceFwd(torch.autograd.Function):
        @staticmethod
        def forward(ctx_, t):
            dist.all_reduce(t)
            return t

        @staticmethod
        def backward(ctx_, g):
            return g

    class AllReduceBwd(torch.autograd.Function):
        @staticmethod
        def forward(ctx_, t):
            return t

        @staticmethod
        def backward(ctx_, g):
            dist.all_reduce(g)
            return g

    class GatherSeq(torch.autograd.Function):
        @staticmethod
        def forward(ctx_, t):
            out = torch.empty(t.shape[0], t.shape[1] * P, t.shape[2],
                              dtype=t.dtype, device=t.device)
            dist.all_gather_into_tensor(out.view(-1, t.shape[2]),
                                        t.reshape(-1, t.shape[2]).contiguous())
            return out

        @staticmethod
        def backward(ctx_, g):
            out = torch.empty(g.shape[0], g.shape[1] // P, g.shape[2],
                              dtype=g.dtype, device=g.device)
            dist.reduce_scatter_tensor(out.view(-1, g.shape[2]),
                                       g.reshape(-1, g.shape[2]).contiguous())
            return out

    class ScatterSeq(torch.autograd.Function):
        @staticmethod
        def forward(ctx_, t):
            out = torch.empty(t.shape[0], t.shape[1] // P, t.shape[2],
                              dtype=t.dtype, device=t.device)
            dist.reduce_scatter_tensor(out.view(-1, t.shape[2]),
                                       t.reshape(-1, t.shape[2]).contiguous())
            return out

        @staticmethod
        def backward(ctx_, g):
            out = torch.empty(g.shape[0], g.shape[1] * P, g.shape[2],
                              dtype=g.dtype, device=g.device)
            dist.all_gather_into_tensor(out.view(-1, g.shape[2]),
                                        g.reshape(-1, g.shape[2]).contiguous())
            return out

    def block(x, w):
        # SP: 进入 Column Parallel 之前 AllGather 出完整 sequence
        xi = GatherSeq.apply(x) if sp else AllReduceBwd.apply(x)
        Bc, Sc, _ = xi.shape
        q, k, v = (xi @ w["qkv"].t()).chunk(3, dim=-1)
        nh = heads // P
        q = q.view(Bc, Sc, nh, -1).transpose(1, 2)
        k = k.view(Bc, Sc, nh, -1).transpose(1, 2)
        v = v.view(Bc, Sc, nh, -1).transpose(1, 2)
        a = torch.nn.functional.scaled_dot_product_attention(q, k, v, is_causal=True)
        attn_out = a.transpose(1, 2).reshape(Bc, Sc, -1) @ w["o"].t()
        # Row Parallel 出口: TP 用 AllReduce，SP 用 ReduceScatter
        attn_out = ScatterSeq.apply(attn_out) if sp else AllReduceFwd.apply(attn_out)
        y = x + attn_out

        yi = GatherSeq.apply(y) if sp else AllReduceBwd.apply(y)
        mlp = (torch.nn.functional.silu(yi @ w["gate"].t()) * (yi @ w["up"].t())) @ w["down"].t()
        mlp = ScatterSeq.apply(mlp) if sp else AllReduceFwd.apply(mlp)
        return y + mlp

    def step():
        x = x0
        for w in layers:
            for p in w.values():
                p.grad = None
            x = block(x, w)
        x.float().pow(2).mean().backward()

    return step, layers

def classify(name):
    n = name.lower()
    if "nccl" in n:
        for key, tag in (("allreduce", "AllReduce"), ("reducescatter", "ReduceScatter"),
                         ("allgather", "AllGather"), ("alltoall", "AllToAll"),
                         ("sendrecv", "SendRecv"), ("broadcast", "Broadcast")):
            if key in n:
                return "comm", tag
        return "comm", "other_nccl"
    if any(k in n for k in ("gemm", "cutlass", "sm90", "s16816", "wgrad", "implicit")):
        return "gemm", "gemm"
    if "attention" in n or "flash" in n or "mha" in n:
        return "attn", "attn"
    return "other", "other"

def profile_step(step, iters=3):
    """用 torch.profiler 统计 CUDA kernel 时间，按通信/计算分类。"""
    import torch
    from torch.profiler import ProfilerActivity, profile

    for _ in range(3):
        step()
    torch.cuda.synchronize()
    with profile(activities=[ProfilerActivity.CUDA], record_shapes=False) as prof:
        for _ in range(iters):
            step()
        torch.cuda.synchronize()
    buckets, per_coll = {}, {}
    for e in prof.key_averages():
        t = getattr(e, "self_device_time_total", 0) or 0
        if t <= 0:
            continue
        kind, tag = classify(e.key)
        buckets[kind] = buckets.get(kind, 0.0) + t
        if kind == "comm":
            per_coll[tag] = per_coll.get(tag, 0.0) + t
    total = sum(buckets.values())
    return {
        "kernel_us_per_iter": {k: v / iters for k, v in buckets.items()},
        "comm_kernels_us_per_iter": {k: v / iters for k, v in per_coll.items()},
        "comm_share_of_kernel_time": buckets.get("comm", 0.0) / total if total else 0.0,
    }, prof

def worker(ctx, cfg):
    import torch
    import torch.distributed as dist

    mode = cfg["mode"]
    dev = ctx.device
    torch.cuda.reset_peak_memory_stats()
    B, S, h = cfg["batch"], cfg["seq"], cfg["hidden"]

    if mode in ("ddp", "fsdp"):
        model = make_model(cfg).to(dev, torch.bfloat16)
        if mode == "ddp":
            from torch.nn.parallel import DistributedDataParallel as DDP
            model = DDP(model, device_ids=None,
                        gradient_as_bucket_view=True,
                        bucket_cap_mb=cfg.get("bucket_mb", 25))
        else:
            try:  # FSDP2
                from torch.distributed.fsdp import fully_shard
                for m in model:
                    fully_shard(m)
                fully_shard(model)
            except Exception:  # 回退到 FSDP1
                from torch.distributed.fsdp import FullyShardedDataParallel as FSDP
                model = FSDP(model, device_id=torch.cuda.current_device())
        x = torch.randn(B, S, h, device=dev, dtype=torch.bfloat16) / 8

        def step():
            model.zero_grad(set_to_none=True)
            model(x).float().pow(2).mean().backward()
    else:
        step, _keep = tp_step_fn(ctx, cfg, sp=(mode == "tp_sp"))

    t = common.time_op(step, warmup=5, iters=10)
    stats, prof = profile_step(step, iters=cfg.get("profile_iters", 3))
    if ctx.rank == 0 and cfg.get("save_trace"):
        import os
        os.makedirs(TRACE_DIR, exist_ok=True)
        path = f"{TRACE_DIR}/exp12_{mode}_w{ctx.world_size}.json"
        prof.export_chrome_trace(path)
        stats["trace"] = path
    stats.update({
        "rank": ctx.rank,
        "mode": mode,
        "world_size": ctx.world_size,
        "step_us": t["p50_us"],
        "step_p95_us": t["p95_us"],
        "peak_mem_MiB": torch.cuda.max_memory_allocated() / 1024 ** 2,
    })
    return stats

def main():
    ap = argparse.ArgumentParser()
    ap.add_argument("--modes", nargs="*", default=["ddp", "fsdp", "tp", "tp_sp"])
    ap.add_argument("--layout", default="2x8")
    ap.add_argument("--layers", type=int, default=4)
    ap.add_argument("--hidden", type=int, default=2048)
    ap.add_argument("--heads", type=int, default=16)
    ap.add_argument("--ffn", type=int, default=8192)
    ap.add_argument("--batch", type=int, default=4)
    ap.add_argument("--seq", type=int, default=2048)
    ap.add_argument("--save-trace", action="store_true", default=True)
    ap.add_argument("--out", default="exp12_transformer_timeline")
    args = ap.parse_args()

    nn_, np_ = (int(x) for x in args.layout.split("x"))
    base = {"layers": args.layers, "hidden": args.hidden, "heads": args.heads,
            "ffn": args.ffn, "batch": args.batch, "seq": args.seq,
            "save_trace": args.save_trace}
    payload = {"meta": {**base, "layout": args.layout}, "data": {}}
    for mode in args.modes:
        cfg = dict(base, mode=mode)
        try:
            res, _ = common.run_dist(worker, nnodes=nn_, nproc_per_node=np_, cfg=cfg,
                                     label=f"exp12_{mode}")
            payload["data"][mode] = {"rank0": res[0],
                                     "step_us_all": [r["step_us"] for r in res]}
        except Exception as e:
            payload["data"][mode] = {"error": f"{type(e).__name__}: {str(e)[:400]}"}
            print(f"[skip] {mode}: {type(e).__name__} {str(e)[:200]}")
        common.save_json(args.out, payload)

if __name__ == "__main__":
    main()

```

结果： `results/exp12_transformer_timeline.json`， chrome trace 在 `/target/comm-lab-traces/exp12_*.json`（用 Perfetto 或 `chrome://tracing` 打开，对应教程里 Nsight Systems 的角色）。

模型：4 层 Transformer（hidden 2048、16 heads、ffn 8192、batch 4、seq 2048）， 2 机 16 卡，四种并行方式。用 `torch.profiler` 抓 CUDA kernel 并按名字分类 （`ncclDevKernel_*` → 通信，`cutlass/gemm/sm90*` → GEMM）。

### 跨机 2x8

| 模式    | 峰值显存        | GEMM kernel | 通信 kernel | 用到的 collective                            |
| ----- | ----------- | ----------- | --------- | ----------------------------------------- |
| DDP   | 4995 MiB    | 23.4ms      | 105.9ms   | AllReduce 105.9ms                         |
| FSDP  | 3749 MiB    | 24.9ms      | 304.4ms   | **AllGather 207.0 + ReduceScatter 97.4**  |
| TP    | **899 MiB** | 1.8ms       | 112.1ms   | AllReduce 112.1ms                         |
| TP+SP | **569 MiB** | 1.8ms       | 289.1ms   | **AllGather 150.6 + ReduceScatter 138.5** |

### 单机 1x8 （`iters=50`）

去掉跨机抖动、把采样数提到 50 之后，时间维度才可读：

| 模式    | step p50   | step p95 | p95/p50  | 峰值显存        | GEMM kernel | 通信 kernel | 用到的 collective                       |
| ----- | ---------- | -------- | -------- | ----------- | ----------- | --------- | ------------------------------------ |
| DDP   | 62.3ms     | 67.1ms   | **1.08** | 4995 MiB    | 23.3ms      | 108.9ms   | AllReduce 108.9                      |
| FSDP  | 102.1ms    | 188.3ms  | 1.84     | 3783 MiB    | 55.3ms      | 184.1ms   | AllGather 138.4 + ReduceScatter 45.7 |
| TP    | **19.3ms** | 77.8ms   | 4.02     | 1091 MiB    | 3.1ms       | 45.5ms    | AllReduce 45.5                       |
| TP+SP | **19.4ms** | 298.6ms  | 15.4     | **775 MiB** | 3.0ms       | 188.0ms   | AllGather 141.5 + ReduceScatter 46.5 |

### 结论

- **TP 与 TP+SP 的 p50 几乎相同（19.3 vs 19.4ms），但显存差 29%（1091 → 775 MiB）。** **SP 是用时间换显存的等价交换，不是免费加速**
- **TP 相对 DDP 的加速是真实的**（62.3 → 19.3ms，3.2 倍）， GEMM kernel 从 23.3ms 掉到 3.1ms，因为每卡只算 1/8 的 FFN。 DDP 的 p95/p50 只有 1.08，这一行数字最可信。
- **通信 kernel 时间与 step time 没有单调关系**：TP+SP 的通信 kernel（188.0ms） 是 TP（45.5ms）的 4 倍，step p50 却相同。原因是这个指标计入了 NCCL kernel 的 驻留自旋等待，且 TP+SP 的 collective 次数翻倍——**它衡量驻留时长，不衡量搬运量**。 同理 TP+SP 的 p95/p50 高达 15.41：同步点更多，撞上长尾的机会也更多。

### **只看 kernel 分类就能认出并行策略**：

- **DDP 只有 AllReduce**：梯度 AllReduce，一种 collective。
- **FSDP 是 AllGather + ReduceScatter**，且 AllGather 约是 ReduceScatter 的 2.1 倍 （207 vs 97）——因为参数要在前向和反向各 AllGather 一次， 而梯度只 ReduceScatter 一次。这个 2:1 的比例是 FSDP 的特征。
- **TP 只有 AllReduce**（激活/梯度），但 **GEMM kernel 时间从 23.4ms 掉到 1.8ms** （13 倍），因为每卡只算 1/16 的 FFN。
- **TP+SP 把 AllReduce 换成了 AllGather + ReduceScatter**，且两者时间接近 （150.6 vs 138.5，比例 1.09），正好对应实验九里"前向 AG / 反向 RS， 前向 RS / 反向 AG"各一次的结构。
