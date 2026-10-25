---
title: "深谈PTO：超越手写极致性能，为什么可行"
date: 2026-05-06
tags: [知乎]
source: https://zhuanlan.zhihu.com/p/2035084143629955119

---

最近，在大家持续不断地折腾、打磨、抠性能、熬夜看 profiler 之后，PTO-ISA 在不同场景下都拿到了一些还算漂亮的性能数据。

![](https://pic3.zhimg.com/v2-623d9c05e8b355f8bf3df706c6d35d74_r.jpg)在最新的代码仓里，我们更新了[高性能Flash Attention的PTO C++实现](https://link.zhihu.com/?target=https%3A//github.com/hw-native-sys/pto-isa/tree/main/kernels/manual/common/flash_atten)，这一版的数据，已经可以超过 torch-npu AscendC 手写算子，平均性能大约做到 **1.1 倍**。

与此同时，我们又把 Qwen3.5 的整网算子重写了一版，叫做[MegaGDN-PTO](https://link.zhihu.com/?target=https%3A//github.com/huawei-csl/megagdn-pto)，切换到 PTO-ISA 之后，Qwen3.5 在 vllm-ascend 端到端性能提升了大约 **15%**；各个算子相比 Triton 实现，普遍有 **1.5x 到 3x** 左右的提升。

在 GLM5.0 和 DS3 的相关算子里，PTO 在 MLA + Index Prolog、Sparse FA 等场景中的性能，也都超过了 torch-npu，同时超过了同期 Triton 算子。

本文主要从技术底层角度讲解我们是如何做到**用更少的代码行数，实现更高的性能， 个别kernel可超越手写极致性能算子**。当然也会讲一下大家关心的和triton/npu-ir的技术对比。

![](https://pica.zhimg.com/v2-6aef6854fb010223d7a6ec8ff101a4e2_r.jpg)大家如果感兴趣，可以到pto-isa代码仓clone下来，在昇腾机器实测一下。如果你现在有Ascend950PR和DT，你可以发现，**相同的FA代码，可以在910B和950PR/DT都跑起来**，性能都能超越对应的手写算子。

千问3.5/3.6的整网算子，也比Triton端到端的性能提升了10%-15%左右，性能如下：

![](https://pic2.zhimg.com/v2-8e0c3b16437e4ffaffb8b6bb5e12f8c9_r.jpg)而且我们发现，现在的PTO即使做到这么快了，还没有完全把昇腾芯片的性能榨干净，性能还有提升空间，预计还有10%的油水。

你这不是吹牛吗？易用性和高性能本来就是鱼和熊掌不可兼得
是的，我们一开始接到的任务，也是以提升易用性为目标，性能能做到手写AscendC的90%就很好了（毕竟Triton-Ascend也是这样要求的）。但是经过调试以后发现，pto-isa的性能在目前测到的shape下性能还可以。

我相信torch npu的同学，按照相同的流水排布，用ascend c重写一遍，也能达到pto相同的性能。但是**获取极致性能的代码效率gap依然存在**。听说当时的FA kernel用了几十个人半年的时间，才把这个性能调到最极致。我们到现在依然没有足够多的人和资源，能够在新的模型百花齐放出来的时候，再组织几个攻关把他们的性能都推到极致。人往高处走，水往低处流，人们总会选择朝着效率更高更便宜的生产工具演进。

当然，我们也会毫无保留的告诉大家，PTO是怎么做到的。NPU生态里面，大家好，百花齐放才是真正的好。无论是triton，npu-ir，pypto，tilelang大家都有存在的意义，能够把这个设计吸取进自己的框架更好。

PTO的设计目标，就是为了解决这个问题而来。

- 没人会为了易用性而抛弃性能
- 相同性能的情况下，我们会选择更易用的那个路径
库—编译—库—编译：PTO 神奇的夹心饼结构
PTO 的整体设计，基本上参考了 ThunderKittens 的架构。当时 TK 刚出来时，我们就注意到了这项工作。不过最开始，我们看 TK，并不是为了做 PTO，而是为了给灵犀指令集中 Tile 寄存器抽象找参考。

![](https://pic1.zhimg.com/v2-d4e32141b5f8c706ee3730db3027da60_r.jpg)TK 对我启发最大的地方，是它对 GPU Memory Layout 的抽象，以及炉火纯青的 C++ Template Arithmetic。我们也借助 C++ Template 构建了 Tile、Tensor 等概念，进而引出了 TileOP 的设计。

但 PTO 的重点，并不只是“定义了几条 TileOP 指令”。

每种语言框架其实都会定义自己的 TileOP。理论上大家都差不多，无非是 tile load、store、matmul、reduce 这些操作。真正的差别在于：**TileOP 一旦写成库，就能显著降低编译 Pass 的复杂度。**

更关键的是，PTO 写的 TileOP，是最懂昇腾硬件脾气的 TileOP。

PTO ISA 和 Ascend NPU IR 的核心区别
很多人问：PTO ISA 和 NPU IR 到底有什么区别？

可以用一个简单例子说明。

同样是做按行累加 RowSum，在昇腾硬件上，不同 TileSize 对应的最佳指令流是不一样的。这个最佳组合，不是拍脑袋选的，而是基于 Vector Core 内部流水线和 Cost Model 固化出来的。

Valid ShapeInstruction SequenceEstimated Cycles64×128vcgadd128 → vadd8 → vcgadd*8 → PIPE_V~O(1024)32×256vcgadd128 → vadd8 → vadd4 → vcgadd4 → PIPE_V~O(2048)16×512vcgadd128 → vcgadd16 → vcgadd*2 → PIPE_V~O(2048)8×1024vcgadd128 → vcgadd16 → vadd8 → vcgadd8 → PIPE_V~O(2048)NPU IR 的典型做法，是在 MLIR Pass 里分析不同 tile size，再对指令和循环做变换。

这个思路当然可以做，但问题是复杂度很容易爆炸。TileOP 里面有循环，TileOP 外面也有循环；如果这些东西都丢给同一套 Pass 去分析和变换，就很容易互相污染。一个 Pass 改了内层，另一个 Pass 又假设外层没变，最后大家一起打架。

AI 编译本来就是一个很难的问题。再用一堆互相耦合的 Pass 去处理硬件细节、循环结构、tile shape 和指令选择，不要说性能，功能正确性和可维护性都会变得很痛苦。

PTO ISA 的做法，说白了反而很朴素：

**把性能关键路径写进 C++ 模板库。**

比如 RowSum，不同 tile shape 对应的几套最佳指令序列，直接用 C++ Template 实现好。Bisheng 编译器通过模板推导，在编译期选择合适版本。

这样做的好处是：TileOP 内部的最优指令序列，被封装在库里；而外部循环、控制流和整体模型推导，仍然交给编译器正常处理。两者边界清楚，互不污染。

这就是 PTO 的“夹心饼”结构：

**库里固化硬件经验，编译器负责组合调度；再由库承接底层 TileOP，再由编译器完成整体生成。**

看起来有点绕，但核心思想很简单：

**以存代算。**

把最懂硬件、最容易反复踩坑、最不适合每次都让 Pass 重新推导的东西，提前沉淀在库里。这样既保留了高性能，又避免了编译 Pass 复杂度失控。

PTO 的关键不在于“我也有 TileOP”。

关键在于：

**这些 TileOP 不是普通积木，而是提前按昇腾硬件纹理打磨过的积木。**

编译器不用每次现场雕刻，只需要把这些积木搭起来。性能来自硬件经验，易用性来自抽象边界，复杂度则被锁在可控范围内。

指令集上带Layout：昇腾原生Layout设计
PTO 有一个很关键的设计：**把 Layout 当成指令集的一等公民**。

这点和 CUTLASS / CuTe 有点像，但在很多指令集里，包括 PTX、TileIR，其实并不常见。而这恰恰是 PTO ISA 获取性能收益的核心之一。

为什么？

因为 NPU 不是一块“想怎么写就怎么跑”的通用加速器。里面有大量硬件约束和隐性规则，不是所有人都知道，甚至包括我，也不可能完全掌握每个操作背后的所有坑。

这时候，**Layout + 模板推导**的价值就出来了。

它可以把我们对硬件的理解固化在库里，通过 Layout 推导和 assert，在编译期就把很多 NPU 的坑绕开。

比如 UB 对齐粒度是 32B，L2 Cache Line 是 512B；矩阵左操作数、右操作数、输出矩阵的分型不一样；CUBE 到 VEC 需要一种 Layout，VEC 到 CUBE 又需要另一种 Layout。CUBE 内部还有 Channel Split / Merge，不同数据格式下，比如 FP8、FP16、INT4x2、MXFP8，处理方式也不一样。

这些东西如果全靠编译器 Pass 去推，问题会非常多。与其让 Pass 在一堆复杂参数里“自由发挥”，不如把它固化成 TileOP 库。这样性能可控，维护也可控。

PTO 不鼓励用户随手写出性能很差的算子。很多不合理的 Layout，会直接在编译期被 assert 掐掉。中间结果的 Layout，也会尽量由 PTO 选择硬件最喜欢的形式。

在 Tensor 中，我们定义了 5 个维度，每个维度都可以声明为 RowMajor 或 ColMajor；在 Tile 中，我们定义了 2 个维度，同样可以声明 Row / Col Major。

通过 C++ 模板推导，FixPipe 随路的量化、变换、转置，都可以按照 NPU 最舒服的方式完成。

比如 Flash Attention 中，Vector Softmax 算出的 P 矩阵，后面要作为 CUBE 的左矩阵，再去乘 V 矩阵。这个过程中，Vector 就可以根据 CUBE 的输入需求，顺手把 P 矩阵写成 CUBE 喜欢的分型。

这件事让 NPU IR 来做，难度就很高。

例如 NPU IR 里的 `hivm.hir.fixpipe`，把 FixPipe IR 暴露给编译器后，呈现出来的就是一堆冷冰冰的参数。什么时候用 unit flag，什么时候不用；什么时候 pre-quant，什么时候 post-quant；scalar / vector 随路计算怎么安排；这些 know-how 如果全部交给 Pass 接管，就非常考验 Pass 作者的硬件理解。

hivm.hir.fixpipe (hivm::FixpipeOp)
HIVM data copy operation from L0C to other memory hierarchies.

Syntax:

operation ::= `hivm.hir.fixpipe` attr-dict
              `ins` `(` $src `:` type($src) `)`
              `outs` `(` $dst `:` type($dst) `)`
              (`unit_flag` `[` $unit_flag_mode^ (`,` $unit_flag_cond^)? `]`)?
              (`->` type($result_tensor)^)?
Fixpipe is pipeline that performing data movement from L0C to other memory hierarchies, with on-the-fly fixed function of pre-stage quantization, pre-stage ReLU, element-wise add, post-stage ReLU, post-stage quantization. Currently support:
问题是，写编译器的人不一定是设计硬件的人。他怎么知道这里面的门道？

说实话，并不是所有人都知道 unit flag 到底该怎么用。又有几个人知道，这玩意儿本质上和 CUBE FixPipe 的 Store Buffer 反压有关？这个世界上能有几个人知道uniflag就像达芬奇核的G点一样，按多了就会出现整核卡死现象？

现在回头骂 AI Core 架构师已经晚了，人家可能都升到 22 级了。更现实的办法，是把这些硬件脾气收进库里，好好用起来。

性能好就一定要暴露底层硬件细节吗？未必
很多人会问：PTO 的 Flash Attention 凭什么只靠 TileOP，就能比 AscendC 手写算子还快？是不是只有暴露到底层细节、直接手搓汇编，性能才会好？

那反过来问一句：

如果把达芬奇的物理汇编和 CCE 全部给你，你就一定能写出超过 AscendC 极致性能的 kernel 吗？

大概率不行。

因为汇编虽然贴近底层，但复杂度并没有消失，只是被一股脑怼到了你脸上。底层细节给你了，不代表你吃得下。

**复杂度守恒定律，适用于所有场景。**

那谁来吃复杂度？

PTO 的答案还是前面说的夹心饼结构：**库—编译—库—编译**。

复杂、稳定、硬件相关的东西，固化在库里；灵活、组合、全局相关的东西，交给编译器。用硬件黑话说，库像 DSA，编译像通用 CPU。只有 DSA-CPU-DSA-CPU 这种结构，才能把复杂度分层摊开，而不是一次性砸给某一个人、某一个 Pass、某一个 kernel 作者。

Flash Attention性能的最后一公里在哪：随路Layout变换
回到主题上来，PTO的Flash Attention性能好，并不是在暴露底层细节，核心还是在于CUBE-VEC-CUBE-VEC这个路上的Layout的随路计算。

CUBE QxK写出来的是一个一个小分型，VEC Softmax需要多个小分型拼成一起，一行一行去读。VEC算完后，在写回GM的时候，直接写成CUBE喜欢的P矩阵分型，然后CUBE做PxV。喂给VEC做global update的时候，再写成VEC能够用满的分型。

![](https://pic3.zhimg.com/v2-1163af94791c92d190fd57c30ac8c8d0_r.jpg)所以，FA的性能收益最后一公里在于CUBE-VEC的随路Layout变换，这个大家在代码仓里就可以看出来。CUBE-VEC的同路在TPUSH/TPOP的PTO指令内部实现中。

有了这个优化后，FA的性能从原来的0.9x提升到1.1x。这种操作，只能在分离的CUBE和VEC架构上才能实现。

这个优化很有意思，因为它只有在昇腾这种分离的 CUBE 和 VEC 架构上才有发挥空间。一个 CUBE push 出来的方形 Tile，可以被两个 Vector Core 分别按行 pop 到内部 SIMD 计算单元里。中间的 Layout 变换，发生在 CUBE-VEC 之间的 MTE 单元中。

这套 FA 加速逻辑，在 GPU 架构上并不天然成立。

那PTO原来达到的0.9x怎么获取的呢？具体细节请看[如何用PTO手写极致性能Flash Attention](https://zhuanlan.zhihu.com/p/1988565015914107985)

PTO 库之上的编译器：PTOAS
PTO 的 TileOP Library 之上，还需要一层很薄的编译器，这就是 **PTOAS**，也就是 **PTO Assembler**。

它的作用很直接：把 PTO 的 TileOP 和 micro op 组合起来，生成一套可以在昇腾达芬奇核上运行的二进制。

PTOAS 要做几件事：在 TileOP 之间分析数据流，插入 `set/wait flag`，执行模板推导，选择最佳的 TileOP shape 实现。我们认为，PTOAS 最合适的实现平台还是 MLIR。原因也简单：PTOAS 本身不复杂，而 MLIR 正好提供了它需要的基础设施。

PTOAS 和 NPU IR 编译器最大的差异，反而在于：**PTOAS 几乎没做太多事。**

听起来像偷懒，但这恰恰是它的优点。

Less is More。

因为性能关键路径已经被 TileOP Library 吃掉了，PTOAS 只需要处理 TileOP 之间的连接、同步和选择。它的功能非常内聚，边界清楚，也就更容易维护。

测试下来，PTOAS 自动插入的同步操作，基本可以做到和手写 `set/wait` 一致，性能上没有明显损失。但上层程序员的体验就完全不一样了：以前需要手动管理同步，现在可以更接近串行逻辑来写代码。

为什么 PTOAS 插同步这么容易，而 NPU IR 插同步这么难？

核心还是库的设计不同。

PTO Tile Lib 已经把 TileOP 内部的循环、控制流和硬件细节吸收掉了。PTOAS 面对的是一个个边界清晰的 TileOP，所以它可以基于 TileOP 顺序去插同步，复杂度自然低很多。

而如果把 TileOP 内部循环、外部循环、控制流、buffer、同步都摊开放进 IR 里，编译器就不得不在一大锅粥里找依赖。锅越大，Pass 越容易打架。

所以 PTOAS 的思路很简单：

**库吃掉内部复杂度，编译器只处理外部数据流。**

我们也把 buffer 管理、地址分配、同步插入做成了可插拔开关。简单场景可以自动化，复杂场景也允许手动接管。

这就是 PTOAS 的定位：不是一个大而全的 AI 编译器，而是一把薄而快的装配刀。

它不负责重新发明所有优化。 它只负责把已经打磨好的 TileOP，稳稳地拼成能跑、能快、能维护的达芬奇核程序。

夹心饼最上层：PTO-DSL
前面讲了 PTO 的“奥利奥结构”：**库—编译—库—编译**。

如果说底层 TileOP Library 是下面那片饼干，PTOAS 是中间那层夹心，把 TileOP、micro op、同步和数据流黏在一起；那么再往上，就需要一层更容易入口的外壳——这就是 **PTO-DSL**。

一句话说，**PTO-DSL 是 PTO-ISA 的 Pythonic 前端和 JIT 编译入口**。

它本质上不是 PTO 体系里最硬核的部分，而是一层 Python binding。上层可以换成更多语言，底层仍然生成 PTO-ISA 汇编。它的价值在于：让用户不用一上来就啃 PTO 汇编和 TileOP 细节，而是可以用更顺手的方式表达 kernel，再由下层夹心结构把它翻译成达芬奇核真正能跑的程序。

但 PTO-DSL 也不是“傻瓜式黑盒”。

它的目标是提供低层、显式、NPU 原生的 primitive，尽量匹配硬件 intrinsics 的性能。换句话说，它不是把硬件细节全藏起来，而是把该暴露的控制权留给用户，把该固化的硬件经验交给库和编译器。

这也是它和几个相邻框架的区别。

和 **tilelang-ascend** 相比，TileLang 可以把 PTO-ISA 作为 codegen 后端；而 PTO-DSL 暴露得更底层。比如 L2 swizzling，在 TileLang 里可能是一句 `T.use_swizzle`，在 PTO-DSL 里则可以写成用户自定义函数。它不急着替用户做完所有选择，而是给懂 kernel 的人留下调度空间。未来 PTO-DSL 稳定后，也可以像 CuteDSL 之于 TileLang 那样，作为更上层框架的底座。

和 **triton-ascend** 相比，两者都会基于 MLIR dialect 做软件流水自动化。但 PTO-DSL 更强调 NPU 原生内存层级，比如 L0、L1、UB。更关键的是，`pto.load / pto.store` 默认映射到昇腾原生高效 DMA 指令；而 `tl.load / tl.store` 更偏 GPU 风格，会尝试做 memory coalescing。一个是从 NPU 的土壤里长出来的，一个是从 GPU 的生态里迁过来的，气质不同。

和 **Catlass** 相比，Catlass 更像专家手调模板合集；PTO-DSL 则更接近 Cutlass 里的 CuteDSL 层，提供显式低层 primitive，让用户继续向下控制。

和 **PyPTO** 相比，PyPTO 是完整的 MPMD 动态运行时栈，也会使用 PTO-ISA 作为底层 primitive。但 PyPTO 的 Tensor API 更接近 PyTorch / JAX；PTO-DSL kernel 仍然是 SPMD 风格，更接近 CuTile / CuteDSL 这一层。

所以，PTO-DSL 在整块“奥利奥”里，不是夹心本身，而是最上面的入口层。

它负责让人好下口；真正决定味道的，还是下面那套 **TileOP Library + PTOAS + TileOP Library + 编译生成** 的夹心结构。

目前我们基于 PTO-DSL 又写了一层算子库。代码仓里的 **FA Builder**，本质上就是一个 JIT 编译库。用户运行 Python，它就可以根据具体 shape 生成对应的 PTO 文件。

更重要的是，PTO-DSL 集成了 Flash Attention 的 Cost Model。Head 怎么切，SeqNum 怎么切，S0 / S1 怎么定，tile size 选多大，对应哪类硬件资源，这些不是靠拍脑袋，而是由 Cost Model 帮忙收敛。

这就和前面的逻辑扣上了：

**底层库吃硬件复杂度，PTOAS 吃同步和数据流复杂度，PTO-DSL 吃用户表达复杂度，Cost Model 吃 shape 选择复杂度。**

每一层都只吃自己该吃的那口，不贪多，不越界。

这就是 PTO 这块“奥利奥夹心饼”真正有意思的地方： 它不是把所有复杂度塞给一个万能编译器，也不是把所有细节甩给 kernel 作者。它把复杂度一层一层摊开，能固化的固化，能推导的推导，能 JIT 的 JIT。

结语：超越手写极致性能，为什么可行？
答案其实不在某一条神奇指令，也不在某一个玄学优化，而在 PTO 对整个 NPU kernel 生产方式的重新拆解。

PTO 做的第一件事，是把 **TileOP 做成最懂昇腾硬件的库**。RowSum 该用什么指令序列，CUBE/VEC 之间该怎么搬，FixPipe 什么时候量化、什么时候转置、什么时候避开 unit flag 的坑，这些不再每次都交给 Pass 去猜，也不再让程序员一遍遍手搓，而是沉淀进模板和库里。

PTO 做的第二件事，是把 **Layout 放到指令集和类型系统里**。昇腾 NPU 的性能，很大一部分不只来自算得快，而来自数据在 CUBE、VEC、UB、L0/L1/L2 之间走得顺。PTO 把 Layout 变成一等公民，让中间结果默认写成硬件最喜欢的样子。Flash Attention 从 0.9x 到 1.1x，最后一公里靠的正是 CUBE—VEC—CUBE—VEC 路上的随路 Layout 变换。

PTO 做的第三件事，是让 **PTOAS 只做它该做的事**。它不试图成为万能 AI 编译器，不把所有循环、同步、buffer、控制流都摊成一锅粥。TileOP 内部复杂度由库吃掉，PTOAS 只负责外部数据流、set/wait、地址和同步。因为边界清楚，所以它插出来的同步能接近手写，而且维护复杂度没有爆炸。

PTO 做的第四件事，是用 **PTO-DSL 和 Cost Model 降低入口成本**。用户不必一上来就啃 PTO 汇编，也不必把 Head、SeqNum、S0/S1、tile size 全靠经验猜。PTO-DSL 负责表达，Cost Model 负责收敛，FA Builder 负责按 shape 生成代码。于是，专家经验不再只藏在某个 kernel 里，而是变成可以复用的生成体系。

所以，PTO 这块“奥利奥夹心饼”的核心不是好看，而是每一层都在吃掉一类复杂度：

**TileOP 库吃硬件细节，Layout 系统吃数据分型，PTOAS 吃同步和数据流，PTO-DSL 吃用户表达，Cost Model 吃 shape 选择。**

这就是 PTO 能做到“代码更少、性能更高”的原因。

手写极致性能当然强，但它强在一次具体战役里；PTO 想解决的是下一百场战役怎么打。当模型从 FA 变成 MLA、Sparse FA、Index Prolog，当硬件从 910B 走到 950PR/DT，如果每次都靠几十个人重新围炉炼丹，那不是生态，是修仙。

PTO 的价值，不是证明手写不重要，而是把手写高手的经验变成库、模板、Layout 和 Cost Model。它不是绕开硬件，而是把硬件脾气放到正确的层里；不是取消优化，而是让优化可以迁移；不是让编译器包打天下，而是让库和编译器各吃各的饭。

它把一次性的英雄主义，变成可复用的工程体系。 它把深夜 profiler 里的血泪，变成下一次编译期的默认选择。 它把少数人知道的硬件暗号，写进了整个生态都能继承的兵器谱里。

这才是 PTO 真正值得讨论的地方。