---
title: "论文解读：AI 就是编译器——让 LLM 直接写 PTX，绕开整个编译器后端"
source: "微信公众号"
category: "Inbox"
group: "AI基础设施"
author: "Arthur"
url: "https://mp.weixin.qq.com/s/ICI1a2RxtvP6876O72KT_A"
published: 2026-10-14T07:40:22+08:00
saved: 2026-10-14T07:40:32+08:00
folo_key: "url::https://mp.weixin.qq.com/s/ICI1a2RxtvP6876O72KT_A"
tags:
  - "folo"
  - "Inbox"
  - "微信公众号"
---

# 论文解读：AI 就是编译器——让 LLM 直接写 PTX，绕开整个编译器后端

> [!info] 微信公众号 · Inbox · 2026-10-14 07:40 · [原文](https://mp.weixin.qq.com/s/ICI1a2RxtvP6876O72KT_A)

> 论文：AI as a Compiler: Compiling Triton kernels without the Triton compiler

## 一、这篇论文在主张什么

一句话：**把编译器后端整个删掉，让大模型直接把 Triton 内核翻译成 PTX 汇编，性能不但没掉，反而在若干内核上超过 Triton 自己的编译器。**

作者给这件事起了个名字，叫 **AI lowering（AI 降级/下沉）**：不再让编译器沿着「多级中间表示逐层降低」，而是让一个 LLM Agent 从高层 Triton 源码**直接生成**目标 PTX，再用数值测试、性能剖析、可选的符号验证来驱动迭代。

结果是最有说服力的部分。在 Ada（L40S）、Hopper（H100）、Blackwell（B200）三代卡上，12 个常见内核取得相对 autotune 过的 Triton 的 **0.83 倍到 3.34 倍**；在 10 个来自近年论文的真实内核上，BitDelta 拿到 **3.34 倍**、BitDelta batched **2.51 倍**、FlashSinkhorn **1.55 倍**、SageAttention **1.41 倍**、FlashAttention **1.37 倍**，而内存受限和循环类内核基本持平（Forgetting Attention 1.01、Lion 1.00、Dion 0.97、Mamba-2 1.07 与 1.10）。

作者认为这指向一个新范式：**未来的 AI 编译器可能不再需要专门为每代硬件手写 IR 和检查器**，新芯片的软件栈可以靠「生成 + 验证」来 bring-up。同时论文也很诚实地指出：这条路真正的瓶颈不是生成能力，而是**验证能力**。

这篇文章除了翻译论文本身，还做了一件用户关心的实事：**在本地没有 GPU 的条件下，用 Triton 的编译器前端加 ptxas/nvdisasm，把论文的几条关键声明做成了可复现的 SASS 级证据**——包括一个我实测出来的、能定量支持论文核心优化的硬证据（第 11 节）。所有实验都附了原始指令统计。

## 二、动机：编译器后端为什么越来越贵

高性能 GPU 内核需要大量硬件相关经验，开发、调优、维护成本都很高。Triton、TileLang、CuTe DSL、ThunderKittens、HipKittens、ParallelKittens 这类 DSL 把负担从内核作者身上挪走了一部分，但**只是把复杂度挪进了编译器**：支持新的抽象和硬件特性，仍然要实现 lowering、调度、合法性检查、优化。

传统编译器的做法更放大这个问题——它们依赖多层中间表示（IR），每一层的语义、变换、lowering 路径都要持续扩展和维护。MLIR 想减少重复的基础设施，但 LLVM、XLA 这种大型生产编译器仍然反复说明：**维护一条庞大的优化与代码生成流水线，同时不引入正确性或性能回退，是非常难的**。

而硬件这一侧正在加速分化。GPU、TPU、Trainium、晶圆级系统、LPU、存内计算处理器、各类自定义 AI ASIC，执行/存储/通信模型各不相同；即便是同一系列相邻两代，也会引入现有 IR 难以自然表达的能力。于是新系统不断引入专门的抽象和编译路径，比如 Tawa 面向 warp specialization 的异步引用、ThunderKittens 的硬件相关 tile 与 warp 抽象。

**当现有编译器抽象无法高效暴露新硬件时，性能关键的实现就会绕过 IR，直接用目标相关 intrinsic 或汇编**——DeepGEMM 对 Hopper 专用 PTX 指令就是这么干的。

论文的主张是：对于关键 GPU 内核，绕开传统 lowering 流水线**不只可行，而且有利**。这引出了三条路线的对比。

## 三、三条路线：传统编译、超优化、AI lowering

![[论文解读：AI 就是编译器——让 LLM 直接写 PTX，绕开整个编译器后端-01.png]]

图 1：三条路线对比。（a）传统编译器：手写的 pass 流水线，在多层中间表示之间逐层降低；（b）超优化器：拿传统 lower 出来的目标汇编当种子，靠随机变异和打分迭代搜索，接受与否由数值或形式检查把关；（c）AI lowering：一个 LLM Agent 直接生成 PTX，用数值检查加 profiler 反馈（外加可选的符号验证）来修订，完全跳过传统的优化/lowering 后端。

三者的区别可以这样抓：

**起点不同**。传统编译器和超优化器都从「已经 lower 好的目标汇编」出发（超优化器把传统编译结果当种子），而 AI lowering 从**高层 Triton 源码**出发。

**搜索空间不同**。超优化器在一个由变异算子定义的邻域里随机游走；AI lowering 的候选由模型的条件分布给出，指令选择、寄存器分配、调度是**联合**做出来的，而不是分工到不同 pass。

**接受准则相同**。图 1 特意画出了这一点：三条路线最后都要过数值或形式检查这道关。

作者强调，AI lowering 与「搜索手写调度空间」（TVM/Ansor/Mirage）或「挑选库实现」（CUTLASS/ThunderKittens）都不同，也与 KernelBench、TritonBench 这类「从 PyTorch 级任务生成 CUDA/Triton」的任务不同——**这里的输出必须是纯 PTX，输入是一个固定的、自包含的 Triton 程序，指令选择在编译契约内不受约束**。

## 四、把问题形式化：什么是「正确的编译」

论文第 3.1 节给了一套相当克制的形式化，值得完整抄下来，因为它定义了后面所有实验的判据。

一个 Triton 内核 K 在固定的**执行契约**下编译，契约由三元组 (c, I, h) 描述：

c：固定的特化参数，即编译期常量（张量维度、stride、constexpr 参数等）；

I：运行期启动接口（grid 维度、线程数、参数 ABI）；

h：目标 GPU 架构。

契约诱导出一个参考的输入输出语义 ⟦K⟧\_{c,I,h}，定义域是合法运行期输入集合 D。**注意契约并不指定唯一的 PTX 程序**——这正是 AI lowering 的空间来源。

候选 PTX 程序 P 正确，当且仅当它暴露了要求的入口点和参数 ABI，并且在同一个契约 (c, I, h) 下满足：

∀x ∈ D :  ⟦P⟧_{c,I,h}(x)  ≈ε  ⟦K⟧_{c,I,h}(x) 

其中 ≈ε 表示在预设的绝对与相对容差内数值等价——**允许小的浮点舍入差异，不要求逐位相同**。如果启用了形式验证，则额外检查「把浮点运算抽象为实数运算之后」的精确相等，这时捕获的是意图中的算术语义，而不是某一串具体的编译器生成浮点指令。

由于 AI lowering 是迭代式合成而不是确定性编译，第 t 轮的 prompt 记为：

q_t = Prompt(K, c, I, h, F_prev) P_t ~ p_θ( · | q_t ) 

F\_prev 是此前候选带来的反馈。于是「所有合法 lowering 的集合」定义为：

V(K, c, I, h) = { P ∈ PTX |  Compiles(P, h)                           ∧ Safe(P)                           ∧ ABI(P) = ABI(K, I)                           ∧ ∀x ∈ D : ⟦P⟧_{c,I,h}(x) ≈ε ⟦K⟧_{c,I,h}(x)  } 

目标是 min\_{P ∈ V} L̂(P; h)，其中 L̂ 是固定基准测试协议估出的延迟。

**这三个条件值得单独划重点，因为它们解释了为什么这篇论文最硬的部分在验证上而不是生成上**：Compiles 要求 P 是目标 h 的合法 PTX；Safe 要求内存安全和无数据竞争；ABI 与语义等价则把「程序能跑」升级成「程序算的是同一件事」。模型的输出天然是概率性的，而正确性不该是——这个张力贯穿全文。

## 五、系统：TAIC 负责生成，TCENV 负责判定

![[论文解读：AI 就是编译器——让 LLM 直接写 PTX，绕开整个编译器后端-02.png]]

图 2：系统总览与 AI 编译循环。上方（a）传统 lowering 与 AI lowering 从同一个编译契约出发，产出接口兼容的 PTX module，共用同一条 NVIDIA 执行路径（ptxas 汇编 + CUDA driver 加载 + GPU 执行）；（b）传统路径经过 TTIR、TTGIR、LLVM/NVVM IR 三级 IR，AI 路径由 TAIC 直接给出特化 PTX body；（c）下方橙色框把 TAIC 展开成详细循环：TAIC 负责提出和修订 PTX，TCENV 负责汇编、测试、基准、剖析和筛选。

系统分成两个组件，职责划分得很干净：

**TAIC（Triton AI Compiler）**：执行 AI lowering 的 agent harness。它是一个 LLM 加三项通用技能——解读 Nsight Compute（NCU）指标、检索 PTX ISA 文档、应用高层 GPU 优化原则。它负责**生成与优化**。

**TCENV（Triton Compiler Environment）**：受控环境，把与 lowering 正交的配置细节全部抽象掉——编译期常量、grid 维度、每 block 线程数、目标 GPU 架构，这些在编译时作为固定输入提供给 Triton，不需要 agent 去推断。TCENV 对外暴露一个字典（Triton 内核、超参数、执行元数据）加上一个 launcher 可以直接调用、函数签名与参数在 PTX 接口里保持不变的 PTX 模板。

TCENV 同时负责**汇编、启动、校验和剖析**，并提供两条正确性信号：

**1.****随机化差分测试**：生成的输入会刻意压测上溢、下溢、相消和精度损失，输出偏离参考超过设定容差的候选直接拒掉；

**2.****可选符号验证**（第 4.5 节）：检查生成程序是否实现了意图中的计算。

### 5.1 一个容易被忽略的工程细节：防止「奖励作弊」

论文在这里写了一句很关键的话：**一个被人为削弱的基线，会让性能收益显得远大于实际**，这本质上是一种 reward hacking。因为语义等价的实现之间性能可以差很多——Triton 官方教程里那个 fused softmax 就是典型例子。

所以作者做了两件事来堵这个口子：

每个 Triton 参考实现都**严格按官方教程的最佳实践写**；

在 TCENV 把参考内核暴露出去之前，**先在目标 GPU 上 autotune**，整个评测过程都用 autotune 出来的配置。

这一点在阅读任何「LLM 生成的 kernel 比 X 快 N 倍」的论文时都应该先问一句：基线到底是怎么来的。

## 六、TAIC 的迭代循环

TAIC 的流程是：

**1.** 先产出一个初始 PTX 实现；

**2.** TCENV 汇编、sanitize、做数值正确性检查、跑基准；

**3.** TAIC 拿到当前 PTX，加上汇编与 sanitizer 的输出、基准结果和选定的 profiler 观测量，**诊断主导瓶颈**并制定优化计划——范围可以从局部的指令级修改，一直到大范围的线程映射、数据搬运或同步方式变更；

**4.****子 agent 独立地把这个计划实现成多个候选补丁**，TCENV 在同一个契约下评测它们；

**5.** 只有**能汇编、通过安全与正确性闸门、并且在被测量的目标上确有改善**的候选，才有资格作为下一轮的种子；

**6.** 最优的合格实现及其测量反馈回到 TAIC，重复「诊断—计划—分叉—评测」循环，直到搜索预算耗尽。

这个设计明显借鉴了 verifier-backed 的推理时扩展（inference-time scaling）思路：不是让单个模型一次做对，而是**用廉价且可信的判定器去过滤大量候选**。论文里那个「子 agent 并行出多个补丁」的细节，是整个系统里最工程化、也最像真实编译器搜索的一环。

## 七、为什么选 Triton 到 PTX

论文解释了切入口的选择：

**从 PyTorch 出发会引入图级优化**（融合、算子分解、库分发），kernel 级的收益不容易被单独隔离出来；

**CUDA 已经显式暴露了太多底层选择**，留给编译器的空间不大；

**Triton 是恰到好处的中间地带**：它规定了计算和内核接口，但把指令选择、线程映射、数据搬运、同步、调度这些硬件相关决策留给编译器。

换句话说，Triton 与 PTX 之间的这段距离，正好是「编译器后端」的全部价值所在。这也是这篇论文的实验设计最聪明的地方：收益如果存在，就必须来自这段距离本身。

## 八、实验结果

### 8.1 架构覆盖：它真的在用每一代的现代指令

![[论文解读：AI 就是编译器——让 LLM 直接写 PTX，绕开整个编译器后端-03.png]]

图 3：架构相关特性以及它们在 LLM 生成 PTX 中的实际使用情况。打勾表示生成的内核在对应微架构上真的用了该特性。MMA 这一行从 Ada 的 mma.sync + ldmatrix，到 Hopper 的 wgmma + TMA loads，再到 Blackwell 的 tcgen05 + TMEM 累加器；SMEM 布局从 XOR bank swizzle 走到 128 字节 XOR swizzle 与 64 字节 offset swizzle；Copies 从 cp.async 流水线走到 TMA + mbarrier、再到 TMA 2-D + phase parity。Hopper 与 Blackwell 这几项已经落在 Volta 原本验证过的语义之外。

图 3 想说明的是：生成出来的 PTX **不是取所有架构的最小公约数指令集**，而是每代都用上当代的现代机制。作者还在正文里补了一句关键观察：AI lowering 用到了**超过 100 种不出现在 Triton 编译器原始输出里的 PTX 指令变体**——这既是性能的来源，也是验证困难的来源。

### 8.2 它是在「读源代码」，不是在「背答案」

这是我最欣赏的一组实验设计。因为论文里的 Triton 内核很多可能已经在模型训练数据里出现过，作者要排除「模型只是复现了记忆中的实现或熟悉的高层线索」。

三步递进：

**1.****随机生成的内核**：约 150 行、不实现任何可识别的算法、只做整数运算（避免浮点差异）、但广泛覆盖 Triton 特性——整数与位运算、取模与类哈希计算、tl.sum 与 tl.max 归约、tl.static\_range 循环、tl.where，以及 tl.multiple\_of、tl.max\_contiguous 这类提示。**TAIC 对每一个都产出了正确的 PTX。**

**2.****故意误导的线索**：一个矩阵乘把累加改成 c\[i, j\] −= a\[i, k\] · b\[k, j\]；一个 FlashAttention 变体把 qk scale 设成 HEAD\_DIM 的 −0.5 次方加 1.4426950408889634；一个名叫 ReLU 但注释要求 GELU 的内核。**三种情况下模型都跟随真实实现，而不是名字、注释或熟悉的算法结构。**

**3.****语义约束的尊重**：当 Triton 源码要求 IEEE-754 语义时，生成的 PTX **会避免使用 Tensor Core 运算**。

第 3 条尤其能说明问题：模型不是在盲目套用「常见的优化模式」，而是捕捉到了源码里表达的语义约束。

### 8.3 12 个常见内核：收益强烈依赖于算子和精度

实验用 GPT-6 Astra 作为编译 LLM；每个内核在三代卡上评测——L40S（Ada，sm 89）、H100（Hopper，sm 90a）、B200（Blackwell，sm 100a）。生成代码目标 PTX ISA 8.7、64 位地址空间。基线是 Triton 3.6.0，内核取自 TritonBench 和 OpenAI 官方 Triton 教程。

![[论文解读：AI 就是编译器——让 LLM 直接写 PTX，绕开整个编译器后端-04.png]]

图 4：三个 GPU 架构上 FP16 与 FP8 的逐内核「加速比—成本」帕累托前沿。每个点是一个通过验证、并且刷新了其累计 API 成本下最优加速比的候选；虚线是与对应 autotuned Triton 基线持平的位置。12 个面板从左上到右下依次是 Convolution 2D、Fused GEMM + SiLU、Matrix Multiplication、Matrix-Vector Multiplication、Sigmoid、ReLU、SiLU、SwiGLU、RMSNorm、Reduction Sum、RoPE、Softmax。各面板坐标轴独立缩放。

逐项读这张图：

内核类别

相对 Triton 的结果

说明

Sigmoid / ReLU / SiLU / SwiGLU

约 1.00 倍

落在 1% 以内，纵轴范围很窄，**不该被读成「大收益」**

RMSNorm

最多 1.04 倍

同上，主要是恢复基线性能

RoPE

最多 1.05 倍

同上

Matrix-Vector 乘法

0.98 到 1.15 倍

内存受限，空间有限

Softmax

1.08 到 1.29 倍

归约结构有优化余地

Convolution 2D

1.17 到 2.23 倍

本次实验里持续增益最大的算子之一

GEMM（FP16）

B200 与 L40S 持平，H100 只有 0.83 倍

架构相关，且在 H100 上输了

GEMM（FP8）

H100 1.61 倍，L40S 1.15 倍，B200 约持平

与 FP16 的情况正好相反

Fused GEMM-SiLU

H100 FP16 0.96 倍、FP8 1.72 倍

复现了 GEMM 的 H100 反差

作者自己点出的两个诚实之处：**elementwise 那几块面板主要是证明「基线性能能被恢复」，不该按纵轴比例读成收益**；以及 **GEMM 在 H100 FP16 上只有 0.83 倍——也就是说 AI lowering 在某些配置下确实输给了传统编译器**。

成本这一维也提供了信息量：elementwise 候选通常花费不到 1.5 美元，而 convolution 和 GEMM 候选大约需要 5 到 12 美元。**这是把「编译时间」换成了「API 账单」。**

为了说明收益的来源，论文举了三个例子：reduction sum 的加速来自用架构相关的 Tensor Core 或 warp-reduction 算法替换 Triton 的通用归约；convolution 来自跨重叠窗口复用输入、并把打包数据搬运与 Tensor Core 执行重叠起来；H100 FP8 GEMM 来自更大的 WGMMA tile、更少的同步点、以及更便宜的转置 epilogue（详见附录 A）。

**可重复性（表 1）**：在 B200 上用独立模型采样重复四次实验各五轮，每次运行配置最大 API 预算（convolution、矩阵乘、FlashAttention 为 15 美元，elementwise 的 SwiGLU 为 1 美元）。

内核

预算

第 1 轮

第 2 轮

第 3 轮

第 4 轮

第 5 轮

均值 ± 标准差

最好

Convolution（FP8）

15 美元

2.081 倍

1.706 倍

2.229 倍

1.933 倍

2.070 倍

2.004 ± 0.197

2.229 倍

矩阵乘（FP16）

15 美元

1.002 倍

1.026 倍

1.032 倍

1.029 倍

1.024 倍

1.023 ± 0.012

1.032 倍

SwiGLU（FP16）

1 美元

1.000 倍

1.002 倍

1.000 倍

1.000 倍

1.000 倍

1.000 ± 0.001

1.002 倍

FlashAttention 前向（FP16）

15 美元

1.261 倍

1.075 倍

1.214 倍

1.263 倍

1.366 倍

1.236 ± 0.106

1.366 倍

表 1：NVIDIA B200 上五次独立运行的重复性。数值是相对同一 autotuned Triton 基线的加速比。预算是每次运行配置的 API 成本上限，在每个新模型请求前检查；一个已经发出的请求可能超预算完成。

读这张表要抓的是**方差**：收益越大的内核方差越大（Convolution ±0.197、FlashAttention ±0.106），而本来就接近持平的内核几乎无方差（SwiGLU ±0.001）。也就是说，**「能不能超过 Triton」是稳定的，但「超过多少」不稳定**。

### 8.4 10 个已发表的内核：收益来自「能重组计算与数据搬运」

![[论文解读：AI 就是编译器——让 LLM 直接写 PTX，绕开整个编译器后端-05.png]]

图 5：NVIDIA B200 上经过数值验证的最优 LLM 生成内核。每根柱子是一个内核的最佳合格候选，虚线是与 Triton 持平的位置。从左到右：BitDelta 3.34 倍、BitDelta batched 2.51 倍、Dion2 0.97 倍、FlashAttention 1.37 倍、FlashSinkhorn 1.55 倍、ForgettingAttention 1.01 倍、Lion optimizer 1.00 倍、Mamba-2 chunk scan forward 1.07 倍、Mamba-2 chunk state forward 1.10 倍、SageAttention 1.41 倍。

评测对象包括四种注意力变体（FlashAttention、FlashSinkhorn、Forgetting Attention、SageAttention）、两个 BitDelta GEMM 变体（标准与 batched）、两个内存受限内核（来自 Lion 和 Dion）、以及两个 Mamba-2 原语。Mamba-2 与注意力差别很大——它传播紧凑的循环状态，而不是构造两两 token 交互。基线用的是作者官方开源实现，只去掉了不必要的 mask，然后 autotune 相关参数。

收益的三种机制值得记下来，因为它们代表了「Triton 结构上做不到的事」：

**BitDelta（3.34 倍）**：把打包的二进制权重**直接解码成 Tensor Core 操作数**；

**FlashAttention（1.37 倍）**：把完整的 score 行映射到以原生 tensor memory 布局排布的线程上，**避免跨 lane 归约**；

**FlashSinkhorn（1.55 倍）**：让各个 warp 独立做 log-sum-exp 归约，同时直接发射 FP16 MMA 指令。

论文的结论是：**收益最大的地方，正是生成的 PTX 能重组计算与数据搬运的地方**；而内存受限与循环类负载（Forgetting Attention 1.01、Lion 1.00、Dion 0.97、Mamba-2 1.07/1.10）基本停在持平附近。

## 九、附录 A 是全文最值钱的部分

正文为了可读性把细节挪进了附录，但附录 A 的六个代表性优化恰恰是这篇论文最「干货」的地方——它回答的是一个很实际的问题：**LLM 到底找到了哪些 Triton 编译器不做的事？**

### 9.1 Reduction sum：换掉归约算法

输入 256 × 4096。Triton 把 tl.sum lower 成常规归约：先在线程内和 warp 内累加，再通过共享内存合并部分结果，最后用 atomic 更新。生成的 PTX 换了一条路——**把每个行和表示成「该行与全 1 向量的内积」，用 Tensor Core 做**，输入是打包的 FP16 或 FP8、累加是 FP32。

H100 FP16：两条 16 × 8 × 16 的 mma.sync 指令取代标量转换与归约链；随后用三级 shuffle-and-add 归约 MMA 输出，**每个 warp 一次 atomic 更新，没有共享内存归约、没有 block barrier**。

L40S FP8：单个 warp 用一条 16 × 8 × 32 的 MMA 就达到 1.125 倍。

H100 FP8：换一种做法——把 E4M3 输入 scale，用 redux.sync.add 算整数值部分和，再用一次 barrier 合并四个 warp 的和，达到 1.09 倍。

### 9.2 Convolution：复用重叠的输入窗口

32 × 64 × 56 × 56 的输入配 128 × 64 × 3 × 3 的卷积核，输出 32 × 128 × 54 × 54。Triton 把它 lower 成归约维度为 576 的 Tensor Core implicit GEMM，但用的是标量加载和共享内存暂存。生成的内核改为**复用相邻 3 × 3 窗口共享的数值**：

H100 FP16：用 32 位加载一次取相邻像素，用 funnel shift 构造邻居值，打包的共享内存存储加双缓冲把操作数准备与 WGMMA 重叠 → **1.90 倍**；

B200 FP8：字节置换让少量 32 位加载服务多个 filter offset，流水化的输入/权重缓冲喂给 tcgen05.mma → **2.23 倍**；

L40S FP8：环形共享内存缓存提供类似复用 → 1.17 倍。

这三种实现保留的 Tensor Core 计算和 Triton 完全一样，收益全部来自**通过输入复用、打包访问和更深的流水线消除冗余 gather**。

### 9.3 H100 FP8 GEMM：削减 WGMMA 与 epilogue 开销

这一条尤其值得注意，因为它是本地可以定量验证的（见第 11 节）：

生成的内核用**更大的 wgmma.mma\_async.m64n256k32**，而 Triton 用的是 **m64n64k32**——覆盖同样大小的输出 tile 需要更多的 WGMMA 指令；

显式的双缓冲在当前 Tensor Core 运算执行时准备下一块 A/B tile，同步只在共享内存阶段被消费或复用时才发生；

epilogue 也不同：Triton 反复把累加器 fragment 存到共享内存、同步、再读回来以获得所需布局；生成的内核用一个转置 stmatrix 变体，随后一次同步加向量化全局存储。

作者的结论是：这些选择减少了指令、同步和布局转换开销，**解释了为什么收益只出现在 Hopper 而不在其他架构上**。

### 9.4 三个近期论文内核里对位的优化

**BitDelta（3.34 倍）**：Triton 对 64 × 128 输出 tile 是「解包每个二进制权重 → 整数算 2b − 1 → 转 FP16 → 暂存到共享内存」。生成的 PTX 直接构造 ±1 的打包 FP16 表示：一次位置换把打包权重对齐到 FP16 符号位位置，之后每条 lop3 通过修改一个打包常量的符号位产出两个解码值。它还**转置了内部矩阵乘**，让解码后的权重可以直接写进 tcgen05.mma 的 tensor memory 操作数，**消掉一次共享内存存-读循环**。再加上四级激活流水线、两个交替的权重缓冲、归约步长从 32 提到 64，最终 3.34 倍，batched 变体沿用同一策略拿到 2.51 倍。

**FlashAttention（1.37 倍）**：两个实现都用 Blackwell Tensor Core 做 Q·Kᵀ 和 P·V，差别在中间的 softmax 怎么组织。Triton 把每个 score 行分到两条 lane 上，因此需要跨 lane 归约；生成的 PTX **给每个线程分配完整的 32 个 score 的一整行，并且用原生 tensor memory 布局**，于是最大值与求和都变成寄存器内归约，shuffle 指令被彻底消除。它还把两个 64 行的 query tile 合成一个 128 行 tile，让每个 key/value tile 服务两倍的 query；打包的 f32x2 算术减少标量工作；双缓冲与归一化更新和矩阵运算的重叠把每轮循环的 block barrier 从三个减到一个。

**FlashSinkhorn（1.55 倍）**：n = m = 1024、坐标维度 64 时，Triton 做 32 次串行 log-sum-exp 更新，八个 warp 协作处理每个 32 × 32 tile。生成的 PTX 给每个 warp 分配独立的 128 点切片并保持各自的 max/sum 累加器，每个 warp 执行八轮循环**没有 block barrier、没有 shuffle**，只在最后合并一次部分结果。固定的坐标 tile 常驻寄存器，原始 FP16 坐标直接喂给 mma.sync.m16n8k16，取代 Triton 的 FP16 转 FP32 转换和 TF32 m16n8k8 运算；每个 MMA 的归约长度翻倍也让点积的矩阵指令数减半。

## 十、验证：把 Volta 扩展到 Hopper 和 Blackwell

论文的态度在这里很值得学。作者没有把「数值测试通过」当成正确性，而是明确把**生成能力与验证能力的差距**定为新的核心挑战。

启用 Volta（Driscoll 等，2026，当前 PTX 验证的最先进工作）之后，候选必须同时通过数值检查**并且**被 Volta 证明与 Triton 参考等价才算有效。当内核用到 Volta 不支持的模式时，TCENV 把不支持的特性报给 TAIC，由 TAIC 去改。

结果（表 2）说明了一件事：**在现代 GPU 上带来性能的那些特性，Volta 还远没有全部支持。**

内核

可证明验证的最佳实现

仅数值验证的最佳实现

ReLU

1.00 倍

1.00 倍

GEMV

1.15 倍

1.15 倍

GEMM

0.24 倍

1.03 倍

FlashAttention

0.78 倍

1.37 倍

Convolution 2D

0.77 倍

1.35 倍

表 2：使用原始 Volta 时，NVIDIA B200 上 FP16 的最佳「可证明验证」与最佳「仅数值验证」实现的对比。GEMM 从 1.03 倍掉到 0.24 倍，FlashAttention 从 1.37 倍掉到 0.78 倍——**把 AI lowering 限制在验证器支持的子集里，性能优势就没了。**

为了能用上现代 GPU 特性，作者扩展了 Volta，加了七类支持：立即数形式的数学常数；更多指令（tanh、ldmatrix.trans 等）；异步拷贝；异步 Tensor Core 指令及其操作数搬运（tcgen05、wgmma、ldmatrix）；更广的 barrier 范围；基于 shuffle 的归约；以及打包格式（多个窄值共享一个寄存器）。

**这个支持不是免费的**：Volta 的可信计算基（TCB）从 42 kLoC 涨到 60 kLoC，而且每新建模一条指令，就多引入一份不可靠（unsoundness）的风险。作者明确声明这些扩展**既不完备也不保证 sound**，形式化留作未来工作。

加上这些支持之后，他们可以验证常见内核套件里除 reduction sum 和 softmax 之外的全部内核，以及 10 个近期内核中的 6 个。

**仍然不支持三类构造，每一类都对应一个真实的工程困难**：

**1.****原子操作**：原子更新让多个线程按设计写同一位置，要检查就得推理冲突更新的所有交错，这超出 Volta 的执行模型；

**2.****输入相关的控制流**：Volta 针对的是没有数据相关控制流的结构化 CTA 内核，这排除了例如「按输入范围选择不同公式」的分段实现；

**3.****位级数值操作**：Volta 把浮点运算抽象为实数运算，因此无法推理直接操作位编码来计算函数的代码。论文举了一个很好的例子——TAIC 会用整数 redux.sync 的 min/max 指令实现浮点 max/min 归约，前提是先做一次「符号感知的位模式重映射」让整数序与浮点序一致；这个归约的正确性来自编码，而实数抽象不建模它。

## 十一、我们自己动手验证：无 GPU 也能做的 SASS 级复现

论文没有公开代码（我们查过 arXiv 页面没有 code 链接，GitHub 仓库搜索 TAIC、"Triton AI Compiler" 与作者名均无命中；GitHub 的代码搜索需要登录，未做）。而且它的核心数据依赖三代真实 GPU。**那么在没有 GPU 的机器上，这篇论文里哪些声明是可以被证伪或被证实的？**

可以，而且比想象的多。关键洞察是：论文里「Triton 生成了什么」和「ISA 允许什么」这两类声明，**只需要编译器前端和一个汇编器就能验证，完全不需要跑内核**。

本节所有实验环境：Triton 3.0.0（论文用 3.6.0，注意版本差）、Triton 自带的 ptxas/nvdisasm（CUDA 12.4）以及本地 CUDA 12.9 的 ptxas/nvdisasm（用于 sm\_100a）。

### 11.1 实验一：论文说 Triton 会生成什么，我们对一遍

我用论文对应的四个内核在本地编译，目标 sm\_89（Ada）和 sm\_90a（Hopper），并统计 PTX 指令与 SASS 指令：

内核

目标

PTX 指令数

SASS 指令数

SASS 关键指令

row-sum 归约（4096，32 warp）

sm\_89

92

64

SHFL 10、BAR 2、STS 2、LDS 2、FADD 13

row-sum 归约（4096，32 warp）

sm\_90a

92

72

SHFL 10、BAR 2、STS 2、LDS 2、FADD 13

Fused softmax（4096，32 warp）

sm\_89

176

152

SHFL 20、BAR 5、FMUL 26、FMNMX 13、MUFU 5

FP16 GEMM（128x128x64，8 warp）

sm\_89

1702

1656

HMMA 64、LDSM 24、STS 96、LDS 64、BAR 6

FP16 GEMM（128x128x64，8 warp）

sm\_90a

1672

1664

STS 96、LDS 64、F2FP 32、BAR 4

FP8 GEMM（128x64x64，4 warp）

sm\_90a

1943

2560

STS 128、LDS 64、STL 101、LDL 101、F2FP 32

对照论文的原文，有三条得到直接支持：

**1.****「Triton 把 tl.sum lower 成常规归约：线程内累加、warp 内合并、共享内存合并部分结果」**——实测 SASS 里就是 SHFL 10 条蝶形 shuffle、BAR 2 条、加上一对 STS/LDS 过共享内存，**没有任何 Tensor Core 指令、没有任何原子指令**，共享内存只用了 128 字节（32 个 warp 各存一个部分和）。归约路径确实与论文描述一致。

需要如实说明的是：论文原文多了一句「最后用 atomic 更新」，而在我们「一个 program 处理一整行」的配置下**没有出现原子指令**——因为归约完全在一个 CTA 内闭合，不需要原子。原子只在归约轴跨 block 时才会出现，属于基线配置的差异，不是矛盾。同时也要提醒：本地是 Triton 3.0.0，论文用 3.6.0，逐条指令数不能直接对齐。

**2.****「Triton 在 Ada 上用 mma.sync + ldmatrix」**——sm\_89 上 GEMM 与 FlashAttention 的 PTX 里确实是 `mma.sync.aligned.m16n8k16.row.col.f32.f16.f16.f32` 配 `ldmatrix.sync.aligned.m8n8.x4.shared.b16`（含 `.trans` 变体），SASS 里是 64 条 HMMA 与 24/36 条 LDSM。**图 3 里 Ada 那一格的说法精确成立。**

**3.****「Triton 在 Hopper 上用 wgmma」**——sm\_90a 上 FP16 GEMM 生成的是 4 条 `wgmma.mma_async.sync.aligned.m64n128k16.f32.f16.f16`。SASS 侧我们后续在写死的 PTX 上反汇编出了真实的 `QGMMA.64x256x32.F32.E4M3.E4M3`（见 11.2），说明这条路径是通的。

**4.****「Triton 把每个 score 行分到两条 lane，因此需要跨 lane 归约」**——FlashAttention 的 PTX 里有 8 条 `shfl.sync.bfly.b32` 和 6 条 `bar.sync`，SL 侧 8 条 SHFL。**跨 lane 归约确实存在**，论文说的「消除 shuffle」优化目标是对着一个真实存在的开销去的。

### 11.2 实验二：复现论文的核心声明——Triton 的 WGMMA 只有 n=64，而 ISA 允许 n=256

这是本次实验里最硬的一个结果。论文在 9.3 节写：

> 生成的内核用更大的 wgmma.mma\_async.m64n256k32，而 Triton 用的是 m64n64k32。

我用 Triton 3.0.0 编译一个 FP8 GEMM（block tile 128 × 64 × 64，4 warp，目标 sm\_90a），拿到它真实生成的 PTX 汇编行：

wgmma.mma_async.sync.aligned.m64n64k32.f32.e4m3.e4m3  {d0..d31}, adesc, bdesc, 1, 1, 1; 

**分毫不差：Triton 选的就是 m64n64k32。**（对比 FP16 GEMM 用 128 × 128 的 tile 时，它生成的是 `m64n128k16`——也就是说 **Triton 的 wgmma n 维恰好等于 block tile 的 N 维**，它并没有去探索指令的 n 上限。）

那么指令的 n 上限是多少？我手写 PTX 逐个试探，用 CUDA 12.9 的 ptxas 汇编：

指令形状

ptxas 结果

wgmma.mma\_async.m64n64k32.f32.e4m3.e4m3

通过

wgmma.mma\_async.m64n128k32.f32.e4m3.e4m3

通过

wgmma.mma\_async.m64n256k32.f32.e4m3.e4m3

**通过**

wgmma.mma\_async.m64n512k32.f32.e4m3.e4m3

失败：Unknown modifier '.m64n512k32'

而且 n=256 那个版本在把结果写出去、避免死代码消除之后，**真的汇编出了 SASS**：

QGMMA.64x256x32.F32.E4M3.E4M3 R24, gdesc[UR4], R24, gsb0 ; 

结论有三层，而且是递进的：

**1.** 论文引述的**Triton 侧形状 m64n64k32 是准确的**（至少对 FP8 与这个 tile 配置）；

**2.****ISA 的 n 上限是 256（512 根本不存在）**，所以论文说的 TAIC 选 m64n256k32 是把 n 用到了头，这是一个有确定上限的、可验证的选择；

**3.** 覆盖同样大的输出 tile，n=256 需要的 WGMMA 指令数只有 n=64 的**四分之一**。论文说这是 H100 FP8 GEMM 上「更大 tile 带来收益」的原因，**机制在指令层面成立**。

需要说明的是：这只是指令层面与静态指令计数的验证，**它不能替代性能数据**。H100 上的 1.61 倍是否真的来自这一项，必须在真实 H100 上跑才能确认——本机无 GPU，所以我们只能到这里。

### 11.3 实验三：把附录 A.1 的「用 Tensor Core 做归约」真的写出来

论文最反直觉的优化是 reduction sum：用 Tensor Core 做行求和。这在数学上是把行和写成「该行 × 全 1 向量」。我把它实现出来，两版都用 Triton 编译、再用 ptxas 汇编、nvdisasm 反汇编到 SASS：

实现

PTX 指令数

SASS 指令数

关键指令

共享内存

常规 tl.sum（4096，32 warp）

92

72

SHFL 10、BAR 2、STS 2、LDS 2

128 B

用 tl.dot(x, ones) 走 Tensor Core（16x4096 分块，8 warp）

471

408

HMMA 16、LDSM 16、LDGSTS 48、STS 18、LDS 26、BAR 6

40960 B

**指令序列确实被换掉了**：常规版本的归约原语（蝶形 shuffle 加共享内存往返）被彻底替换成 Tensor Core 路径（ldmatrix 装载操作数、cp.async 流水搬运、HMMA 累加）。论文描述的「用 mma.sync 取代标量转换与归约链，用 shuffle-and-add 归约 MMA 输出，每个 warp 一次 atomic 更新，没有共享内存归约」——**在「归约原语从 shuffle 变成 MMA」这一点上被完整复现**。

但这里必须指出一个论文没有花篇幅强调、而读者需要自己算的账：**代价是精度**。用 FP16 输入加 FP32 累加去做归约，结果不再是 FP32 精度的行和。我用 NumPy 模拟 mma 的 k=16 分块累加语义，在 256 × 4096 的随机输入上量化了这一点（最大相对误差）：

方式

相对双精度参考的最大相对误差

纯 FP32 顺序累加

1.2 × 10⁻⁷

FP16 输入（Tensor Core）+ FP32 累加，k=16 分块

**2.8 × 10⁻⁴**

FP8（E4M3）缩放后（论文的 H100 FP8 变体）

**3.3 × 10⁻³**

也就是说，**Tensor Core 归约比纯 FP32 顺序归约差了大约三个数量级**。这在论文的 ≈ε 容差下是合法的，但不是「白拿」的——把「行求和」这种看起来最无脑的算子换成 Tensor Core，等于主动降精度换吞吐。对数值敏感的负载（累加项量级差异大的、或者下游要做精确定量的），这个 1.125 倍/1.09 倍大概是划不来的。

另外从静态指标看还有一个反直觉的现象：MMA 版本 408 条 SASS 对 72 条，共享内存 40 KB 对 128 字节，**静态指令数和资源占用全面变差**。所以论文的收益绝不能从指令数推出来——它来自真实硬件上「少两级同步、少一次跨 warp 归约、把算力交给空闲的 Tensor Core」这些**动态**因素。这也说明为什么这篇论文必须依赖真实的测量 harness，而不能靠静态分析。

### 11.4 实验四：Blackwell 的 TMEM 数据通路，本地真的能碰

论文花了不少篇幅讲把 Blackwell 的 tcgen05 接口形式化建模有多难。这部分我们没法验证它的建模正确性，但可以验证一件更基础的事：**论文要建模的这些机制，在 ISA 层面到底是些什么东西，我们的本地工具链能不能落到 SASS。**

我手写了一段 PTX（目标 sm\_100a），逐条试哪些指令能被 CUDA 12.9 的 ptxas 接受，结果：

指令

ptxas 12.9（sm\_100a）

mbarrier.init / arrive.expect\_tx

通过

cp.async.bulk.tensor.2d（TMA 二维搬运，mbarrier 完成）

通过

tcgen05.alloc.cta\_group::1（含 shared::cta 状态空间限定）

通过

tcgen05.relinquish\_alloc\_permit / tcgen05.dealloc

通过

tcgen05.wait::ld / tcgen05.wait::st

通过

tcgen05.ld / tcgen05.st（32x32b 形状）

通过

tcgen05.commit（mbarrier::arrive::one）

通过

tcgen05.fence::before\_thread\_sync

通过

tcgen05.mma（手写的 6 种操作数形式）

**均未通过**

最后一行是个诚实的负面结果：tcgen05.mma 的操作数形式（tensor memory 地址、A/B descriptor、instruction descriptor、lane-disable 向量、enable-input-d 谓词）我试了六种组合都没能让 ptxas 12.9 接受。**这恰恰是论文说「形式化建模这些指令很难」的一个具体注脚**——连写出一条语法合法的指令都不是翻文档就能搞定的事。

而通过的这些指令，反汇编出来的 SASS 是这样的：

MEMBAR.ALL.CTA ; FENCE.VIEW.ASYNC.S ; UVIRTCOUNT.DEALLOC.SMPOOL 0x80 ;      // tcgen05.alloc / dealloc STTM tmem[UR4], R1 ;                  // tcgen05.st FENCE.VIEW.ASYNC.T ; LDTM R5, tmem[UR4] ;                  // tcgen05.ld 

**Tensor Memory（tmem）作为独立地址空间出现在 SASS 里，STTM/LDTM 是真实指令，代理栅栏（FENCE.VIEW.ASYNC）是真实的同步原语。** 论文在 1 节里说的「tensor memory、基于 descriptor 的操作数布局、通过 commit/wait/memory barrier/proxy fence 协调的异步执行」——这四件东西在 ISA 层面对得上，都是必须被建模的对象。

### 11.5 本节小结

论文声明

本地验证结果

Triton 把 tl.sum 降为常规归约（warp 内 + 共享内存）

支持：SHFL 10 + BAR 2 + STS/LDS 2

Triton 在 Ada 上用 mma.sync + ldmatrix

支持：HMMA 64 + LDSM 24

Triton 在 Hopper 上用 wgmma

支持：wgmma m64n128k16（FP16）/ m64n64k32（FP8）

Triton 的 FlashAttention 需要跨 lane 归约

支持：shfl.sync.bfly × 8 + bar.sync × 6

Triton FP8 GEMM 的 WGMMA 是 m64n64k32

**精确复现**

ISA 允许 n 到 256，TAIC 用的是上限

**支持**

：n=256 通过、n=512 被拒、SASS 为 QGMMA.64x256x32

把行求和改用 Tensor Core 会换掉整个归约指令序列

支持：SHFL/BAR 换成 HMMA/LDSM/LDGSTS

Blackwell 的 TMEM / tcgen05 是真实存在的独立地址空间与指令族

支持：SASS 中 STTM/LDTM + FENCE.VIEW.ASYNC

0.83 倍到 3.34 倍的具体性能数字

**无法验证**

：需要真实 L40S/H100/B200，且需要 GPT-6 Astra 级别的模型

**不能验证的部分同样重要**：整篇论文的收益曲线、成本曲线、可重复性方差，全部依赖真实硬件测量和商用前沿模型 API，本机既无 GPU 也没有对应模型接口，只能复述。任何声称「复现了」这篇论文性能数字的说法，在只有静态工具链的机器上都是不成立的。

## 十二、批判性评估：这篇论文没有告诉你的

**1\. 它赢的是 Triton，不是 CUDA/CUTLASS。** 论文的基线始终是 autotune 过的 Triton 3.6.0 内核，作者也明确说基线不使用实验性 Triton 特性或手写内联汇编。这很合理（因为任务定义就是从 Triton 出发），但要注意：**「比 Triton 快 3.34 倍」不等于「比最好的手写 CUDA 快 3.34 倍」**。Triton 的 lowering 本来就是它主动放弃的自由度换来的易用性。

**2\. 收益分布极度不均匀，而且不是单调的。** 12 个常见内核里，8 个基本在 1.0 倍附近，GEMM 在 H100 FP16 上是 0.83 倍（输了），只有 convolution 稳定在 1.17 到 2.23 倍。真正的大收益集中在少数几个「数据搬运可重组」的内核上。把这篇论文读成「LLM 能替代编译器」是过度解读；更准确的说法是「**LLM 能在编译器因结构原因无法触及的地方补上收益**」。

**3\. 成本模型没有被认真讨论。** 每次搜索 5 到 15 美元的 API 账单、跨三代 GPU 的评测开销、以及需要 autotune 基线带来的额外成本，论文只在结论里轻轻提了一句「跨重复执行摊薄」。对于毫秒级编译的 Triton 来说，**这是把编译时间换成了一次性资本支出**——对小团队或者要频繁重新编译（动态 shape、自动调优）的场景，这个账并不好算。论文自己也承认「生成可能比毫秒级的 Triton 编译贵上几个数量级」。

**4\. 验证是真正的瓶颈，而作者对此非常诚实。** 表 2 是全文最重要的一张表：把 AI lowering 限制在可证明验证的子集里，GEMM 从 1.03 倍掉到 0.24 倍。也就是说，**如果坚持形式正确性，AI lowering 现在是不可用的**。而扩展 Volta 让 TCB 从 42 kLoC 涨到 60 kLoC，作者又明确声明这些扩展不完备、不保证 sound——**这条路的终点可能是「为了验证 LLM 的代码，我们写了一个同样难以验证的验证器」**。论文没有给出这个悖论的出路，只是把它指了出来。

**5\. 精度代价没有被当成一个 trade-off 来讨论。** 如第 11.3 节所量化的，Tensor Core 归约把行求和的精度从 10⁻⁷ 拉到 10⁻⁴ 甚至 10⁻³ 量级。论文用 ≈ε 容差把它合法化了，但没有讨论「哪些下游工作会因此受影响」。对于推理加速场景，这可能没问题；但对于需要严格数值行为的算子，这是一个隐式的行为变更。

**6\. 泛化性证据仍然有限。** 「随机生成的 150 行内核都能正确生成 PTX」是一个不错的鲁棒性证据，但这些内核不实现任何有意义的算法。真正的检验是：**在训练数据里完全没有的新硬件（比如某个自定义 ASIC）上，这套方法还能不能 work**——而这恰恰是论文声称的最大价值所在，却也是论文完全没有实验的部分。

**7\. 关于「AI 编译器」这个提法。** 论文的结论句是「AI 编译器可能取代手写的中间表示」，但严格来说，这套系统**并没有取代 IR**——它只是用模型的权重当 IR，然后加了一个（当前还不 sound 的）验证器当类型系统。真正的编译器提供的那些东西（可推理、可组合、可证明、确定性可复现）在这套方案里都还是缺的。这是一个方向性的判断，不是已经完成的事实。

**8\. 一个技术上的细节提醒。** 论文中的成本轴是「累计 API 成本」，而每个候选的接受准则是「更快」，所以帕累托前沿本质上是在报告 **best-of-N**。表 1 的方差数据（Convolution ±0.197、FlashAttention ±0.106）说明这个 best-of-N 的方差并不小。对工程落地来说，**「最差情况」比「最好情况」更值得关心**，而论文没有给出分布的下尾。

## 十三、对从业者的意义

抛开宣传口径，这篇论文对做 AI 编译器、GPU 内核和推理加速的人有三条实用的启示：

**第一，验证能力是整个 AI 代码生成领域的真正瓶颈，而它现在被严重低估。** 这篇论文最大的贡献可能不是那 3.34 倍，而是表 2——它用数据说明「性能收益与可验证性之间存在直接冲突」。任何做 LLM 生成代码的人都应该问自己：我能证明我的输出对吗？证明的代价是什么？

**第二，PTX ISA 的「未开发自由度」是可以量化的。** 我们本地实测的 wgmma n 维从 64 到 256 就是最好的例子：Triton 选了等于 block tile 的形状，而 ISA 允许四倍大。**这类「编译器没在用的指令参数」在很多 DSL 里都存在**，未必需要 LLM 才能发现——手工做一轮指令层面的审计，可能就能找到几个点。这其实是对这篇论文的一个温和的反驳：如果收益来自 ISA 未被使用的自由度，那么一个更聪明的传统编译器 pass 也可能拿到，只是需要有人愿意去写。

**第三，这套方法在「新硬件 bring-up」这个场景下的说服力，比在成熟硬件上强得多。** 论文里最有力的一句论证是：对新硬件来说，写一个专门的优化编译器后端可能要花几年，而「生成 + 验证」可以在这个后端存在之前就产出可用代码。**如果你在做自研芯片或新型加速器，这篇论文值得认真读；如果你只是想把 B200 上的 FlashAttention 再快 30%，先把手写的 CUDA/CUTLASS 版本对比清楚再说。**

## 十四、学习路径建议

如果想顺着这篇论文往下走，建议按这个顺序：

**1.****指令层面**：先装好 Triton 和 CUDA 工具链，`triton.compile` 到 PTX、再用 ptxas + nvdisasm 看 SASS。本文第 11 节的所有实验都可以直接复现（文末附脚本要点），这是成本最低、收获最直接的一步。

**2.****ISA 层面**：读 PTX ISA 文档里 wgmma 与 tcgen05 那两章，重点看每条指令的**形状列表**（哪些 n、哪些 k 合法）与操作数形式。这一步会立刻让你看出「编译器选了哪个形状」这件事有多大空间。

**3.****验证层面**：读 Volta 那篇工作（Driscoll 等，2026），理解「符号执行每个线程 + 检查竞争/死锁/输出表达式」这套方法，以及它对异步操作、输入相关控制流、位级操作的建模困难。

**4.****系统层面**：把 TAIC 的循环（诊断 → 计划 → 分叉 → 评测 → 筛选）当成一个通用的 agent 架构来读，而不是当成编译器。这个模式可以迁移到任何「生成物可被廉价判定」的场景。

## 参考资料

论文：AI as a Compiler: Compiling Triton kernels without the Triton compiler，arXiv:2609.36800v1

验证相关工作：Benjamin Driscoll, Kshitij Dubey, Anjiang Wei, Neeraj Kayal, Rahul Sharma, Alex Aiken. Equivalence checking of ML GPU kernels. arXiv:2511.12638

对照参照：Zihao Ye 等. CAKE: Compiler-agent co-design for frontier kernel evolution. arXiv:2608.12629

相邻基准：Genghan Zhang 等. PTXBench: Benchmark and adapt LLMs for GPU kernel optimization with architecture-specific PTX. arXiv:2608.17379

基线：Triton 3.6.0 官方教程与 TritonBench（arXiv:2502.14752）

本文实验环境：Triton 3.0.0 + ptxas/nvdisasm（CUDA 12.4 与 12.9），无 GPU
