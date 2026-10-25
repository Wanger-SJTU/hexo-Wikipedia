---
title: 各家芯片厂商 Triton编译路径选择深度分析
date: "2026-07-05 00:00:00"
updated: "2026-07-05 00:00:00"
layout: post
permalink: /collections/0.raw/zhihu/AI-infra/各家芯片厂商-Triton编译路径选择深度分析/
disableNunjucks: true
wiki: false
nav_hidden: true
categories:
  - 文档
tags:
  - 知乎
source_url: https://zhuanlan.zhihu.com/p/2057073142737137777
---


- [FlagTree之各家芯片triton Lower 过程整理（nvidia,AMD, 摩尔线程，sunrise, 华为Ascend, Enflame燧原）](https://zhuanlan.zhihu.com/p/2056693972614000814)**从[FlagTree之各家芯片triton Lower 过程整理](https://zhuanlan.zhihu.com/p/2056693972614000814)这篇文章中，我们想想梳理了各家芯片厂商triton Lower过程整理，这篇文章主要从硬件架构设计角度，进行深度分析它们triton Lower策略这么选择的核心原因**

1. 各家芯片厂商编译路径选择总览

1.1 两条编译路径的根本分化

FlagTree 作为 fork 自 triton-lang/triton 的统一编译器，支持**两条核心编译路径：TritonGPU dialect 路径和 Linalg dialect 路径**。这种双路径设计是 FlagTree 多后端支持的核心，也是各家芯片厂商接入 Triton 生态时面临的第一个也是**最关键的架构决策**。

- TritonGPU 路径继承自上游 Triton，面向 GPGPU 架构芯片，编译流程为 Triton Python → TTIR → TTGIR → LLVM IR → 后端特定机器码；
- Linalg 路径是 FlagTree 为非 GPGPU 架构芯片新增的编译路径，通过 FLIR（FlagTree IR，fork 自 microsoft/triton-shared）将 TTIR 转换为 Linalg dialect，再由各厂商的后端编译器处理。这种路径分化的根本原因是硬件架构的差异。

- GPGPU 架构（如 NVIDIA、AMD、摩尔线程 MUSA）的编程模型基于**线程块、warp、共享内存等 GPU 概念**，可以直接复用 **TritonGPU 的编译流水线**；
- 而非 GPGPU 架构（如华为昇腾达芬奇、寒武纪 MLU）的编程模型与 GPU 差异较大，需要通过 Linalg dialect 进行中间转换。
- 值得注意的是，燧原（Enflame）作为 NPU 厂商，却选择了 TritonGPU 路径，这在 NPU 厂商中是独特的，值得深入分析。
1.2 各家芯片厂商路径选择汇总

**表 1-1 各家芯片厂商编译路径选择汇总**

芯片厂商硬件架构编译路径流水线最终产物核心优化层NVIDIAGPGPU（SM+Tensor Core）TritonGPUttir→ttgir→llir→ptx→cubincubinmake_ttgir（Hopper warpspec/Blackwell tmem）AMDGPGPU（CU+MFMA）TritonGPUttir→ttgir→llir→amdgcn→hsacohsacomake_ttgir（stream_pipeline/pingpong）摩尔线程GPGPU（MUSA，CUDA兼容）TritonGPUttir→ttgir→llir→mubinmubinmake_ttgir（SQMMA/TME）海光GPGPU（DCU，HIP兼容）TritonGPUttir→ttgir→llir→amdgcn→hsacohsacomake_ttgir（stream_pipeline/warp_spec）天数智芯GPGPU（CUDA兼容）TritonGPUttir→ttgir→llir→asm→cubincubinmake_ttgir（Hopper warpspec/tmem）燧原NPU（GPGPU-like）TritonGPU+自定义ttir→ttgir→gcuir→llir→fatbinfatbinmake_gcuir（TritonGCU Dialect）寒武纪NPU（MLU，NRAM/WRAM/SRAM）Linalgttir→linalg→linalgopt→mluir→mluiropt→mlisa→cnbincnbinmake_linalg+make_optimized_linalg+make_mluir华为昇腾NPU（达芬奇，Cube/Vector/Scalar）Linalgttir→ttadapter→npubinnpubinttir_to_linalg（HIVM/hfusion/DAG调度）

1.3 类GPU与NPU的主要区别

从表 1-1 可以清晰看到，

- 类GPU芯片（NVIDIA、AMD、摩尔线程、天数智芯、海光）全部选择 TritonGPU 路径，
- 而 NPU 芯片（寒武纪、华为昇腾、砺算）选择 Linalg 路径。
- 燧原是唯一的例外——作为 NPU 却选择了 TritonGPU 路径。这种分化的根本原因在于硬件架构的编程模型差异。
类GPU芯片的核心特征是：

- 硬件架构基于线程块（thread block）、warp、共享内存（shared memory）等 GPGPU 概念，计算单元是大量并行的流处理器或 Tensor Core，编程模型是 SIMT（Single Instruction Multiple Thread）。
- 这种架构可以直接映射到 TritonGPU 的 TTGIR 中间表示，TTGIR 中的 BlockedEncodingAttr（布局编码）、warp 分配、共享内存分配等概念与 GPGPU 硬件一一对应。
- 因此，类GPU芯片可以复用 Triton 社区的大量优化 pass，如 add_coalesce（内存合并）、add_pipeline（软件流水线）、add_warp_specialize（warp 特化）等。NPU 芯片的核心特征是：

- 硬件架构基于专用的 AI 计算单元（如昇腾的 Cube/Vector/Scalar、寒武纪的 NRAM/WRAM/SRAM），编程模型是基于算子和数据流的，而不是基于线程并行的。
- 这种架构无法直接映射到 TritonGPU 的线程块/warp/共享内存模型，因此需要通过 Linalg dialect 进行中间转换。Linalg 是 MLIR 的结构化操作 dialect，使用 tiling、fusion、bufferization 等通用优化，可以灵活映射到各种 AI 加速器架构。
2. 类GPU架构与NPU架构基础概念

2.1 类GPU架构的核心概念

2.1.1 SIMT编程模型

类GPU架构的编程基础是SIMT（Single Instruction, Multiple Threads，单指令多线程）。

- SIMT允许GPU用**一条指令控制多个线程同时执行相同的操作**，但**每个线程可以访问不同的数据并有自己的控制流**（如条件分支）。
- 这种模型使得GPU编程比纯SIMD更灵活——开发者不需要手动管理向量宽度，硬件会自动将线程分组为warp（NVIDIA术语）或wavefront（AMD术语）来执行。在NVIDIA GPU中，**一个warp包含32个线程，它们在同一时钟周期执行相同的指令，但可以有不同的寄存器状态和内存访问地址**。AMD GPU的wavefront通常是64个线程。
SIMT模型是类GPU架构能够高效执行数据并行任务（如矩阵乘法、卷积）的根本原因，**也是Triton的TTGIR中间表示能够直接映射到GPU硬件的基础**。

2.1.2 流多处理器（SM/CU）

**流多处理器**（Streaming Multiprocessor，**SM**，NVIDIA术语）或计算单元（**Compute Unit，CU**，AMD术语）是GPU的核心计算单元。
一个GPU芯片包含**多个SM/CU**（例如NVIDIA H100有132个SM，AMD MI300X有304个CU），每个SM/CU内部包含**多个流处理器核心（Streaming Processor，SP）、寄存器文件、共享内存、L1缓存、以及调度单元**。

- SM/CU是线程块（thread block）的调度单位，一个线程块被分配到一个SM/CU上执行，SM/CU内部的资源（寄存器、共享内存）决定了能同时驻留多少个线程块。
- SM/CU内部还包含特殊的计算单元，如Tensor Core（NVIDIA）或Matrix Core（AMD），用于加速矩阵乘法运算。SM/CU的设计理念是通过大量并行线程来隐藏内存延迟，当一部分线程等待内存数据时，其他线程可以继续执行计算，从而保持计算单元的高利用率。

2.1.3 线程块与网格

线程块（thread block）是GPU编程中的基本调度单位。

- 一个线程块包含一组协同工作的线程，它们共享同一个SM/CU的资源（共享内存、寄存器），可以通过同步原语（如__syncthreads()）进行协调。
- 多个线程块组成一个网格（grid），网格中的所有线程块执行相同的kernel函数，但可以处理不同的数据。线程块的大小（即线程数量）由开发者指定，通常是的warp大小的整数倍（如128、256、512个线程）。
- 线程块之间是独立的——它们不能直接通信，只能通过全局内存进行间接通信。这种设计简化了硬件调度，使得GPU可以轻松扩展到大量计算单元。
在Triton中，一个kernel对应一个grid网格，每个program（相当于一个线程块）处理一个数据分块.
Triton的TTGIR中间表示中的BlockedEncodingAttr就是用来**描述线程块内的线程如何映射到数据分块的**。

2.1.4 Warp与Warp Specialization

Warp是NVIDIA GPU中线程调度的基本单位，一个warp包含32个线程。AMD GPU中对应的概念是wavefront（通常64个线程）。

- Warp内的**所有线程在同一时钟周期执行相同的指令（SIMT模型）**，但可以有不同的数据。
- Warp Specialization（warp特化）是Hopper架构引入的新特性，**允许同一个线程块内的不同warp执行不同的任务**。

- 例如，在矩阵乘法中，可以让一部分warp负责数据加载（producer warp），另一部分warp负责计算（consumer warp），通过异步拷贝和共享内存进行通信。
- 这种设计打破了传统SIMT模型中所有warp执行相同指令的限制，更接近于任务并行模型。
- Warp Specialization是类GPU架构吸收NPU/数据流架构思想的一个例子——它允许更细粒度的任务分工，类似于NPU中不同计算单元（Cube/Vector）的分工。
- 在FlagTree中，燧原GCU400和NVIDIA Hopper都实现了warp specialization，但实现方式不同：NVIDIA使用nvidia.passes.hopper.add_hopper_warpspec，
- 燧原使用gcu_passes.gcu400.add_gcu_warp_specialization（pingpong模式）。
2.1.5 共享内存与L1缓存

共享内存（shared memory）是GPU中一种高速的片上内存，**位于SM/CU内部，供同一线程块内的所有线程共享访问**。

- 共享内存的带宽远高于全局内存（通常高1-2个数量级），延迟也低得多（约几十个时钟周期 vs 几百个时钟周期）。
- 共享内存的容量有限（如NVIDIA H100每个SM有228KB的共享内存），需要开发者手动管理。共享内存是GPU高性能计算的关键——通过将频繁访问的数据加载到共享内存中，可以大幅减少全局内存访问延迟。
- AMD GPU中对应的概念是LDS（Local Data Share），功能类似但实现细节不同。在Triton中，共享内存的管理由编译器自动完成，开发者不需要手动分配。**Triton的TTGIR中的add_allocate_shared_memory pass就是用来为TTGIR操作分配共享内存的**。
共享内存是类GPU架构与NPU架构的一个重要区别——NPU通常使用专用的片上SRAM（如寒武纪的NRAM/WRAM），其管理方式与GPU的共享内存不同。

2.1.6 Tensor Core与Matrix Core

Tensor Core（NVIDIA术语）或Matrix Core（AMD术语）是GPU中专门用于加速矩阵乘法的硬件单元。与传统流处理器的标量/向量运算不同，T**ensor Core可以在一个时钟周期内执行一个小的矩阵乘加运算（如D = A × B + C）**。

- NVIDIA Hopper的第四代Tensor Core可以在一个时钟周期内执行一个16×16×16的FP16矩阵乘加运算，等效于数千次FMA运算。
- AMD的MFMA（Matrix Fused Multiply Add）指令类似，但操作粒度更大（如MI300X的MFMA可以处理256×256的矩阵分块）。Tensor Core/Matrix Core是现代GPU高性能AI计算的核心——大语言模型的矩阵乘法运算几乎全部由Tensor Core/Matrix Core执行。
在Triton中，**tt.dot操作会被编译为Tensor Core/Matrix Core指令**。

- 各家芯片厂商的Tensor Core实现不同：NVIDIA使用Tensor Core（支持FP4/FP6/FP8/FP16/BF16/TF32），
- AMD使用MFMA，摩尔线程使用SQMMA，燧原使用Tensor Compute Kernel，天数智芯和天垓使用兼容CUDA/HIP的矩阵计算单元。这些差异是各家芯片在make_ttgir阶段使用不同专有pass的根本原因。

2.1.7 TMA：Tensor Memory Accelerator

TMA（Tensor Memory Accelerator）是NVIDIA Hopper架构引入的一个重要特性，它是一种硬件单元，**专门用于在全局内存和共享内存之间高效传输多维张量数据**。
在传统GPU编程中，**数据从全局内存加载到共享内存需要通过寄存器中转——每个线程执行load指令从全局内存读取数据到寄存器，再执行store指令将寄存器数据写入共享内存**。
这种方式存在两个问题：第一，占用大量寄存器资源；第二，线程需要手动计算每个数据元素的地址，编程复杂。

- TMA解决了这些问题——它允许开发者指定**一个多维张量描述符（tensor descriptor），硬件自动从全局内存将整个张量分块加载到共享内存，完全绕过寄存器**。TMA支持1D到5D的张量传输，支持各种分块和步长模式。
- TMA的引入标志着**GPU架构开始吸收数据流架构的思想**——它将**数据移动从线程级别提升到张量级别，更接近于NPU的DMA（Direct Memory Access）引擎**。在FlagTree中，TMA相关的优化包括passes.ttir.add_rewrite_tensor_descriptor_to_pointer（将tensor descriptor转换为pointer以兼容旧架构）和nvidia.passes.ttnvgpuir.add_promote_lhs_to_tmem（Blackwell中将LHS提升到tensor memory）。TMA是类GPU架构吸收NPU特点的一个典型例子。

2.1.8 Tensor Memory（tmem）

Tensor Memory（tmem）是NVIDIA Blackwell架构引入的一种**新型片上内存，专门用于存储Tensor Core的累加器（accumulator）数据**。
在Hopper及之前的架构中，**Tensor Core的累加器存储在寄存器文件**中，这会占用大量寄存器资源，限制了能同时**驻留的warp数量**。

- Blackwell引入了**256KB的专用Tensor Memory，用于存储MMA（Matrix Multiply Accumulate）的中间结果，释放了寄存器资源**。
- Tensor Memory是warp同步的（warp-synchronous），即同一个warp内的所有线程可以共享访问。这种设计更接近于NPU的专用累加器缓冲区——NPU（如昇腾的Cube单元）通常有专用的累加器寄存器，与通用寄存器分离。
- Tensor Memory的引入是类GPU架构进一步吸收NPU设计思想的体现——它将计算中间结果从通用寄存器中分离出来，使用专用存储，提高了数据复用效率。在FlagTree中，Blackwell相关的优化包括

- nvidia.passes.ttnvgpuir.add_allocate_tensor_memory（分配tensor memory
- nvidia.passes.ttnvgpuir.add_promote_lhs_to_tmem（将矩阵乘法的LHS提升到tmem）。
2.2 NPU架构的核心概念

2.2.1 AI Core与计算单元分工

NPU（Neural Processing Unit）架构的核心特征是使用专用的AI计算单元，而不是通用的流处理器。以华为昇腾的达芬奇架构为例，其AI Core包含三种计算单元：**Cube Unit（矩阵计算单元）、Vector Unit（向量计算单元）和Scalar Unit（标量计算单元）**。

- Cube Unit专门执行矩阵乘法运算（如D = A × B + C），类似于GPU的Tensor Core但操作粒度更大（昇腾的Cube Unit可以处理16×16×16的矩阵分块）。
- Vector Unit执行向量运算（如激活函数、归一化等），
- Scalar Unit执行标量运算（如控制流、地址计算等）。这三种计算单元通过流水线方式协同工作——Cube Unit完成矩阵乘法后，结果直接传递给Vector Unit进行后处理，无需通过内存中转。
这种设计理念与GPU的SIMT模型根本不同，

- **GPU的所有计算（包括矩阵乘法和向量运算）都由相同的流处理器/Tensor Core执行，通过线程并行来隐藏延迟**；
- NPU则通过**专用计算单元的流水线来提高效率**。
- 寒武纪的MLU也有类似的设计，使用MLU Core（包含张量计算单元和向量计算单元）作为基本计算单元。
2.2.2 专用片上存储（NRAM/WRAM/SRAM）

NPU通常使用**分层的专用片上存储**，而不是GPU的统一共享内存。
以寒武纪MLU为例，其片上存储分为三层：

- **NRAM（Neural RAM）是每个MLU Core私有的高速存储**，用于存储该**Core的计算中间结果（如矩阵乘法的累加器）**，类似于GPU的寄存器文件但容量更大；
- WRAM（Weight RAM）是每个MLU Core私有的权重存储，专门用于存储神经网络权重；
- SRAM是多个MLU Core共享的片上存储，类似于GPU的共享内存/L1缓存。这种分层存储设计针对AI计算的特点进行了优化——**权重数据（WRAM）和中间结果（NRAM）分开存储**，避免了数据竞争，提高了访问效率。
华为昇腾的AI Core也有类似的分层存储：

![](https://pic2.zhimg.com/v2-16b43ca44c28d19f76d238fccb9454f9_r.jpg)
Unified Buffer（UB，统一缓冲区）用于**存储输入/输出数据**
L0A/L0B/L0C用于存储矩阵乘法的A/B/C矩阵，这些缓冲区都是专用的，与计算单元直接相连

- 两个bufferL0A和L0B作为输入，其中一个暂存activition，另一个暂存权重。红色的Cube模块，类似谷歌TPU脉动阵列结构，是一个乘累加阵列，
- 计算结果输出存放在另外一个buffer L0CNPU的专用存储设计与GPU的通用共享内存形成鲜明对比——**GPU的共享内存可以存储任何类型的数据，由开发者/编译器管理；NPU的存储是按数据类型分区的，由硬件自动管理**。

2.2.3 数据流驱动与算子调度

NPU的执行模型是基于数据流和算子调度的，而不是GPU的线程并行模型。

- 在NPU中，计算被组织为一系列算子（operator），每个算子对应一个AI计算操作（如矩阵乘法、卷积、激活函数等）。算子之间通过数据依赖关系连接，形成数据流图（Data Flow Graph）。
- NPU的硬件调度器根据数据依赖关系自动调度算子执行——当一个算子的所有输入数据就绪时，它就可以开始执行。
- 这种数据流驱动模型与GPU的线程并行模型根本不同——**GPU的kernel是一个完整的计算单元，所有线程同时启动执行**；NPU的算子是更细粒度的计算单元，可以按需启动。数据流驱动模型的优势是可以更好地利用计算单元的流水线

- 当Cube Unit执行矩阵乘法时，Vector Unit可以同时执行前一个算子的后处理。
- 华为昇腾的HIVM（Huawei Intermediate Virtual Machine）就是基于这种数据流模型设计的中间表示。砺算科技的DSA（Data Stream Architecture）也是类似的数据流架构。数据流驱动是NPU架构的核心特征，也是NPU无法直接使用TritonGPU的线程块/warp模型的根本原因。

2.2.4 DMA引擎与数据预取

NPU通常使用专用的DMA（Direct Memory Access）引擎来管理数据传输，而不是GPU的基于线程的load/store指令。

- DMA引擎可以独立于计算单元工作——当计算单元执行计算时，DMA引擎可以同时将下一个数据分块从全局内存预取到片上存储。这种计算与通信的重叠是NPU高性能的关键。
- 在GPU中，数据传输由线程的load/store指令完成，需要占用寄存器和计算资源；
- 在NPU中，数据传输由DMA引擎独立完成，不占用计算资源。有趣的是，NVIDIA Hopper的TMA实际上就是吸收了NPU DMA引擎的思想——T**MA可以独立于线程工作，将张量数据从全局内存异步传输到共享内存，不占用寄存器**。这是类GPU架构吸收NPU特点的另一个典型例子。
燧原GCU的make_gcuir中也有add_convert_triton_load_store_to_gcu_dma pass，将Triton的load/store操作转换为GCU的DMA操作，这表明燧原的GCU也使用了类似NPU的DMA引擎。

2.3 类GPU架构与NPU架构的本质区别

**表 1-1 类GPU架构与NPU架构的本质区别**

维度类GPU架构NPU架构编程模型SIMT（单指令多线程），线程并行数据流驱动，算子调度计算单元通用SM/CU + Tensor Core/Matrix Core专用Cube/Vector/Scalar + DMA存储模型统一共享内存 + 寄存器文件分层专用存储（NRAM/WRAM/SRAM）数据传输线程load/store指令独立DMA引擎并行粒度warp/wavefront（32/64线程）算子/数据流节点延迟隐藏多线程切换隐藏延迟计算-通信流水线隐藏延迟灵活性高（通用并行计算）中（AI计算专用）能效比中（通用性带来开销）高（专用设计减少开销）
从表1-1可以看出，类GPU架构和NPU架构在设计哲学上有根本区别。

- 类GPU架构追求通用性和灵活性：通过大量并行线程来隐藏延迟，使用统一的编程模型（SIMT）来支持各种并行计算任务。
- NPU架构追求专用性和能效比：通过专用计算单元和分层存储来优化AI计算，使用数据流模型来最大化计算单元的利用率。这两种设计哲学没有绝对的优劣，而是针对不同的应用场景做了不同的权衡。类GPU架构更适合需要灵活性的场景（如研究、原型开发、多样化工作负载），NPU架构更适合固定工作负载的大规模部署场景（如数据中心AI推理/训练）。

2.4 类GPU架构对NPU特点的吸收

一个值得注意的趋势是，现代类GPU架构正在逐步吸收NPU的设计思想，以提升AI计算的效率。这种融合趋势体现在以下几个方面。

2.4.1 TMA：从线程级数据传输到张量级DMA

**NVIDIA Hopper引入的TMA（Tensor Memory Accelerator）**是类GPU架构吸收NPU DMA引擎思想的典型例子。

- 在传统GPU中，数据传输由线程的load/store指令完成，**每个线程负责加载一部分数据，需要占用寄存器和计算资源**。
- NPU则使用独立的DMA引擎，可以异步传输数据而不占用计算资源。TMA将这种DMA思想引入GPU：

- 它允许硬件自动将多维张量从全局内存传输到共享内存，完全绕过寄存器，不占用线程资源。这使得GPU的数据传输方式从线程级提升到张量级，更接近NPU的DMA模型。
- TMA的引入使得GPU在执行矩阵乘法等AI计算时，可以更高效地重叠计算和数据传输，提升了整体性能。
2.4.2 Tensor Memory：从通用寄存器到专用累加器存储

NVIDIA Blackwell引入的**Tensor Memory（tmem）**是类GPU架构吸收NPU专用存储思想的体现。

- 在Hopper及之前的架构中，Tensor Core的累加器存储在通用寄存器文件中，与线程的其他数据共享寄存器空间。这导致了寄存器压力问题——复杂的计算kernel可能因为寄存器不足而无法充分利用Tensor Core。
- NPU（如昇腾的Cube Unit）通常有专用的累加器寄存器（L0C），与通用寄存器分离。Blackwell的Tensor Memory采用了类似的设计——256KB的专用存储用于Tensor Core累加器，释放了通用寄存器资源。这种设计更接近NPU的专用存储模型，提高了数据复用效率。

2.4.3 Warp Specialization：从纯SIMT到任务分工

**Warp Specialization**是类GPU架构吸收NPU计算单元分工思想的体现。
在传统SIMT模型中，**同一线程块内的所有warp执行相同的指令序列，只是处理不同的数据**。

- NPU则通过专用计算单元（Cube/Vector/Scalar）实现任务分工：不同计算单元执行不同类型的操作。Warp Specialization打破了纯SIMT的限制——它允许同一线程块内的不同warp执行不同的任务（如producer warp负责数据加载，consumer warp负责计算），通过异步通信进行协调。这种设计更接近NPU的计算单元分工模型，使得GPU可以更灵活地组织计算。AMD的stream_pipeline和燧原GCU400的pingpong warp specialization也是类似的思想。

2.4.4 异步执行与流水线

NPU的**DMA引擎天然支持异步执行**——计算和数据传输可以并行进行。
传统GPU的异步执行能力有限，主要通过软件流水线（software pipelining）来模拟。
但Hopper架构引入了**TMA的异步拷贝和async barrier，使得GPU可以真正实现硬件级的异步执行——TMA可以异步传输数据，async barrier可以异步同步线程，计算和数据传输可以真正并行**。
这种异步执行能力是NPU的核心优势之一，现在也被GPU架构吸收。
在FlagTree中，各家芯片都实现了软件流水线优化（add_pipeline pass），但底层硬件支持的程度不同——NVIDIA Hopper/Blackwell和AMD CDNA有较强的硬件异步支持，其他芯片可能更多依赖软件模拟。

2.4.5 融合趋势总结

**表 1-2 类GPU架构对NPU特点的吸收**

NPU特点类GPU的吸收方式引入时间代表架构DMA引擎TMA（Tensor Memory Accelerator）2022年NVIDIA Hopper专用累加器存储Tensor Memory（tmem）2024年NVIDIA Blackwell计算单元分工Warp Specialization2022年NVIDIA Hopper / AMD   CDNA3异步执行TMA异步拷贝 + async barrier2022年NVIDIA Hopper数据流调度软件流水线（add_pipeline）持续演进所有类GPU架构
 从表1-2可以看出，类GPU架构正在系统性地吸收NPU的设计思想。这种融合趋势的本质是：

- AI计算的特点（矩阵乘法密集、数据复用高、计算-通信比高）更适合NPU的专用设计，
- 而GPU的通用设计在AI计算上存在效率损失。通过吸收NPU的特点（DMA、专用存储、任务分工、异步执行），GPU可以在保持通用性的同时提升AI计算的效率。
3. 各家芯片硬件架构详解

3.1 NVIDIA：GPGPU架构的标杆

![](https://picx.zhimg.com/v2-b4e4032b45b1af9a8a78d792a4190b2d_r.jpg)
Ampere架构（capability 8x）:

- NVIDIA Ampere架构（如A100）是第三代Tensor Core架构，**引入了TF32（TensorFloat-32）数据类型支持**。Ampere的SM包含64个FP32 CUDA核心、4个第三代Tensor Core，每个SM可以执行1024个FP32 FMA运算或256个Tensor Core MMA运算。
- Ampere还引入了**稀疏化Tensor Core支持**，可以将矩阵乘法的计算量减少一半（结构化稀疏）。
- Ampere的**共享内存为164KB/SM（可配置为共享内存或L1缓存）**，支持异步拷贝（async copy）从全局内存到共享内存，这是TMA的前身。
- 在FlagTree中，Ampere架构的优化路径走capability // 10 == 8的分支，使用hopper_warpspec（虽然名为hopper，但Ampere也支持部分warp specialization功能）。NVIDIA Hopper架构（如H100）是第四代Tensor Core架构:

- 第一是TMA（Tensor Memory Accelerator），允许硬件自动将多维张量从全局内存异步传输到共享内存，绕过寄存器，这是吸收NPU DMA引擎思想的体现。
- 第二是分布式共享内存（Distributed Shared Memory），允许不同SM的共享内存直接通信，实现了SM间的数据共享。
- 第三是第四代Tensor Core，支持FP8数据类型，AI计算性能大幅提升。
- 第四是Warp Specialization，允许同一线程块内的不同warp执行不同任务（producer/consumer模型），这是吸收NPU计算单元分工思想的体现。
- Hopper的SM包含128个FP32 CUDA核心、4个第四代Tensor Core，共享内存为228KB/SM。在FlagTree中，Hopper架构使用nvidia.passes.hopper.add_hopper_warpspec进行warp specialization优化，使用add_pipeline进行软件流水线优化。
NVIDIA Blackwell架构（如B200）是第五代Tensor Core架构：

- 引入了**Tensor Memory（tmem）这一革命性设计**。
- tmem是256KB的专用片上存储，用于存储Tensor Core的累加器数据，释放了通用寄存器资源。这是吸收NPU专用累加器存储思想的体现。
- Blackwell的第五代Tensor Core支持FP4和FP6数据类型，进一步提升了AI计算密度。Blackwell还增强了Warp Specialization能力，支持更灵活的任务分工。在FlagTree中，Blackwell架构：

- 使用nvidia.passes.ttnvgpuir.add_allocate_tensor_memory分配tmem，
- 使用nvidia.passes.ttnvgpuir.add_promote_lhs_to_tmem将矩阵乘法的LHS提升到tmem，
- 使用passes.ttgpuir.add_warp_specialize进行warp specialization优化。Blackwell架构是类GPU架构吸收NPU特点最深入的体现——tmem的引入使得GPU的存储模型更接近NPU的分层专用存储。

**片上存储的演进：从通用到专用分层**

- **Ampere的共享内存为164KB/SM（可配置为共享内存或L1缓存），支持异步拷贝（async copy）从全局内存到共享内存**。**Tensor Core 的累加器结果必须经过寄存器，通用寄存器成了瓶颈**——寄存器文件大小固定，矩阵乘法的中间结果占满之后无法继续流水。
- **Hopper 的 228KB /SM 共享内存扩大了容量**，但更革命性的是引入了分布式共享内存，**允许不同 SM 之间直接读写对方的共享内存**，这是第一次在硬件上打破 SM 间数据隔离的壁垒。
- Blackwell 的 tmem（256KB 专用片上存储）是真正的范式转变：累加器数据不再走通用寄存器，直接写入 tmem。这和 NPU 中的专用累加器存储思想完全一致——通用寄存器是稀缺资源，把矩阵乘法的中间结果从寄存器里&#34;驱逐&#34;出去，通用寄存器就可以专注于控制流和地址计算，Tensor Core 的流水利用率得以提升。**数据搬运的演进：从软件控制到硬件自动化**

- Ampere 的 Async Copy 是第一步：允许软件发起一个异步的全局内存到共享内存的搬运请求，不阻塞当前线程。但它是一维的、软件显式控制的，程序员需要手动计算地址、管理同步点。
- Hopper 的 TMA（Tensor Memory Accelerator）是质变：它是一个独立的硬件引擎，**理解多维张量的布局描述符（stride、shape、swizzle）**，可以自动处理多维张量从全局内存到共享内存的搬运，完全绕过寄存器，不占用 CUDA 核心的执行带宽。这是把 NPU 里 DMA 引擎的思想引入 GPU——让专用硬件做数据搬运，让计算单元专注于计算。
- Blackwell 的**增强 TMA 进一步支持直接写入 tmem，使得&#34;全局内存 → tmem → Tensor Core 累加&#34;这条路径可以全程不经过 SMEM**，降低了延迟，也减少了共享内存的压力。

**线程组织的演进：从同质到分工**
传统 GPU 的 warp 是同质的，一个 warp 内所有线程执行同样的任务（SIMT 模型）。这对通用并行计算很合适，但对 AI 计算产生了低效：矩阵乘法需要的操作序列是&#34;搬数据 → 计算 → 再搬数据 → 再计算&#34;，在同质 warp 模型下，搬数据和计算是串行的，GPU 总有一半时间在等待。

- **Hopper 的 Warp Specialization 打破了这个假设**：**同一个线程块内，一部分 warp 专门负责用 TMA 搬运数据（producer warp），另一部分专门负责驱动 Tensor Core 计算（consumer warp）。两者通过异步屏障协调**，实现了计算和数据搬运的真正并行——这正是 NPU 中&#34;搬运单元和计算单元独立工作&#34;的设计哲学在 GPU 上的体现。
- Blackwell 在此基础上进一步灵活化，支持更细粒度的任务分工，**配合 tmem 的调度使得 producer/consumer 之间的数据传递延迟更低**。

**数据类型的演进：精度与计算密度的持续权衡**
每一代新增更低精度的数据类型，本质上都是同一个判断：AI 推理中，许多计算对数值精度的需求低于训练，用更少的 bit 表示相同的语义，可以在相同的硬件带宽下塞进更多的有效计算。

- Ampere 的 TF32 是一个巧妙的过渡设计——与 FP32 的指数位相同（8 bit），与 BF16 的尾数位相近（10 bit vs 7 bit），使得已有的 FP32 训练代码无需修改即可获得加速，降低了迁移成本。
- Hopper 的 FP8 使计算密度相比 FP16 再翻倍，配合 TMA 和 Warp Specialization，使得 H100 在 transformer 工作负载下的实际利用率远高于 A100。
- Blackwell 的 FP4 已经接近表示能力的物理极限（4 bit 只有 16 个离散值），但通过分组量化（group quantization）和混合精度累加，在推理场景下依然能保持可接受的精度损失，换取近乎 4 倍于 FP16 的计算密度。总之，一句话总结：

- Ampere 做的是&#34;给通用 GPU 加上 AI 加速器&#34;，Hopper 做的是&#34;重新设计数据通路让 AI 计算成为一等公民&#34;，Blackwell 做的是&#34;引入专用存储分层让 GPU 的片上存储模型趋近于 NPU&#34;。
- 每一步都是在回答同一个问题：如何让越来越多的时钟周期花在真正的矩阵乘法上，而不是花在数据搬运、同步等待和地址计算上。

3.2 AMD：CDNA架构与MFMA

3.2.1 CDNA架构概述
AMD的CDNA（Compute DNA）架构是**面向计算密集型工作负载的GPU架构**，与RDNA（面向游戏）架构不同。

- CDNA架构使用Matrix Core（矩阵核心）作为AI计算单元，执行MFMA（Matrix Fused Multiply Add）指令。
- 与NVIDIA Tensor Core的warp级操作不同，AMD的MFMA是wavefront级操作——一条MFMA指令由整个wavefront（64个线程）协同执行，处理一个较大的矩阵分块（如16×16×16或32×32×32）。这种设计使得AMD GPU的矩阵计算效率更高，但编程模型与NVIDIA略有不同。
- CDNA架构使用LDS（Local Data Share）作为共享内存，功能与NVIDIA的shared memory类似但实现不同。AMD CDNA3（如MI300X）引入了stream_pipeline和pingpong warp specialization等特性，与NVIDIA Hopper的warp specialization类似。3.2.2 MFMA指令与Matrix Core
AMD的**MFMA指令是Matrix Core的执行单元**，支持多种数据类型（FP64/FP32/FP16/BF16/INT8/FP8等）。MFMA的操作粒度比NVIDIA Tensor Core更大——例如MI300X的MFMA可以处理256×256的矩阵分块（通过组合多条MFMA指令）。这种大粒度操作减少了指令发射开销，提高了计算密度。
在FlagTree中，AMD后端使用：

- passes.ttgpuir.add_optimize_dot_operands优化MFMA的操作数布局，
- 使用amd.passes.ttgpuir.add_stream_pipeline实现stream pipeline优化，
- 使用passes.ttgpuir.add_warp_specialize实现pingpong warp specialization。AMD的MFMA设计与NVIDIA Tensor Core的设计理念不同——NVIDIA追求细粒度灵活性，AMD追求粗粒度效率，这反映了两种不同的架构哲学。

3.3 摩尔线程：MUSA架构（CUDA兼容）

摩尔线程的MUSA（Moore Threads Unified System Architecture）架构是CUDA兼容的GPGPU架构。MUSA的设计理念是与NVIDIA CUDA生态兼容，使得CUDA程序可以通过musify工具自动移植到MUSA平台。

![](https://picx.zhimg.com/v2-a7fa26fc3a124b6dc82cb0fbd218e6eb_r.jpg)
以春晓架构为例，该架构是产品 MTT S80 的架构。如上图所示，MP（MUSA Processor）是最小的一个整体结构，它含有128个单精度浮点运算单元 FP32，32个整型/位运算单元 INT8，**寄存器区域及任务调度区域**。除此之外还有32个单精度浮点特殊函数计算单元 SFU，2个双精度浮点运算单元 FP64，张量积算引擎部分 TCE（Tensor Compute Engine）。另外还有28 KB大小的局部储存器 Local Memory。
MUSA架构包含**通用计算核心和张量计算核心（Tensor Core），支持FP32/FP16/INT8等数据类型**。MUSA的编程模型与CUDA一致——线程块/warp/共享内存的概念完全相同，warp大小为32（与NVIDIA一致）。
在FlagTree中，摩尔线程走TritonGPU路径，使用musa:<arch>作为target。摩尔线程的专有优化包括：

- mthreads.passes.ttgpuir.add_accelerate_matmul（SQMMA矩阵乘法加速）、
- add_tme_lowering（TME操作lowering）、
- add_convert_sqmma_to_mtgpu（SQMMA到MTGPU转换）等。MUSA架构的特点是高度兼容CUDA生态，**使得摩尔线程可以快速复用TritonGPU的优化成果，同时通过SQMMA等专有指令实现硬件特定优化**。摩尔线程的MTT S80/S3000等芯片基于MUSA架构，支持128个MUSA核心和多个张量计算核心。

3.4 天数智芯：（GPGPU + TLE深度集成）

天数智芯的架构是通用GPGPU架构，支持**标准的线程块/warp/共享内存模型**。

![](https://pic2.zhimg.com/v2-ea7453150dd3993c5aa8e73935132af1_1440w.jpg)
天数芯片与英伟达A800基于相同GPGPU架构，计算层次一致，但在核心配比（GPC/TPC/SM数量）、存储配置（显存64GB vs 80GB）及L1使用模式（4SM共享 vs 单SM独享）上存在差异。
天数芯片以共享L1设计降低L2带宽与布线需求，A800则凭借更多计算单元、更大显存及独享L1，在并行性能与延迟控制上更具优势，二者适配不同算力场景需求。

![](https://pica.zhimg.com/v2-1a3af847cd0fc8fa91de909c62ffed58_r.jpg)

3.5 海光：DCU架构（HIP兼容）

海光的DCU（Deep Computing Unit）架构是AMD HIP兼容的GPGPU架构。DCU的设计理念是与AMD ROCm/HIP生态兼容，可以直接使用LLVM AMDGPU后端生成机器码。
[https://zhuanlan.zhihu.com/p/591017296](https://zhuanlan.zhihu.com/p/591017296)

![](https://pic1.zhimg.com/v2-7c1fa7cfdd435b9b16e37fe8c71dd436_r.jpg)

![](https://picx.zhimg.com/v2-e7909648fa14d952303b277ea634c6a3_r.jpg)
一个DCU计算单元主要由计算单元阵列（CU）、缓存系统（L1、L2）、全局内存和数据通路DMA组成。DMA能够将数据传输控制与指令执行控制分离，当CPU接受到数据传输指令即将数据拷贝到DCU中时，DMA单元来接管这一个过程，当CPU转交这一个控制权后可以继续执行后续指令，同时在DCU中，DMA控制的数据传输不会中断正在进行的计算过程。在DCU中一共有两个DMA控制单元，来管理CPU与DCU以及DCU与DCU之间的数据传输。

SIMD是CU的计算核心部件，而每个CU包含4个SIMD。每个SIMD有10个wavefront，每个wavefront的大小是64(对应的NVIDIA GPU的大小是32)。而且每个SIMD包含多个矢量计算单元(DCU2上有16个)，还有一个被多个SIMD共用的标量计算单元。 这些计算单元可以访问一个所谓的寄存器文件，里面包括矢量寄存器和标量寄存器，下面对计算单元和寄存器进行展开介绍。 
DCU的硬件架构与AMD CDNA架构类似，使用Matrix Core/MFMA作为AI计算单元，使用LDS作为共享内存。在FlagTree中，海光走TritonGPU + AMDGCN路径，编译流水线与AMD后端完全一致（ttir→ttgir→llir→amdgcn→hsaco）。
海光的专有优化包括：

- hcu.passes.ttgpuir.add_accelerate_matmul（矩阵乘法加速）、
- add_stream_pipeline（stream pipeline）、
- add_warp_specialize_hcu（warp specialization）、
- add_mls_stream_pipeline（MLS stream pipeline）、
- add_block_pingpong（block pingpong）等。这些pass是海光对AMD标准pass的定制化版本，反映了DCU架构在AMD CDNA基础上的特定优化。海光DCU的优势在于可以复用AMD ROCm生态，降低软件开发成本。

3.6 燧原：GCU架构（NPU走GPGPU路径）

![](https://pic4.zhimg.com/v2-d31359f1919a33da16e511aa33a32139_r.jpg)燧原的GCU（Global Compute Unit）架构是一个有趣的特例——它本质上是NPU，但硬件设计足够接近GPGPU，使得燧原选择了TritonGPU编译路径。
GCU的硬件架构基于Tensor Compute Kernel（张量计算核心），每个kernel支持1x32-bit MAC或4x16-bit/8-bit MAC，支持全精度和混合精度。GCU有256个Tensor Compute Kernel，具有类似GPU的线程块/共享内存模型。

- 燧原的GCU分为三代：GCU300（第一代，Kurama，DTU 1.0）、GCU400（第二代，TuSi，DTU 2.0）、GCU500（第三代，开发中）。
- GCU400引入了Warp Specialization（pingpong模式）和TLE支持，GCU500进一步向标准GPGPU模型靠拢。
- 在FlagTree中，燧原走TritonGPU + 自定义TritonGCU dialect路径，编译流水线为ttir→ttgir→gcuir→llir→fatbin。
- 燧原的核心优化在make_gcuir阶段，使用gcu_passes.gcu300/gcu400.*系列pass，包括add_gcu_convert_triton_to_tritongpu、add_tritongcu_accelerate_matmul、add_gcu_warp_specialization等。燧原的选择反映了GCU架构的GPGPU特性——虽然有NPU的血统，但硬件设计足够接近GPU，可以复用TritonGPU生态。

3.7 寒武纪：MLU架构（NRAM/WRAM/SRAM分层存储）

寒武纪硬件的基本组成单元是 MLU Core。每个 MLU Core 是具备完整计算、IO 和控制功能的处理器核心，可以独立完成一个计算任务，也可以与其他 MLU Core 协作完成一个计算任务。

- 每 4 个 MLU Core 核心构成一个 Cluster，在 MLUv02 以及后续架构中，每个 Cluster 内还会包含一个额外的 Memory Core 和一块被 Memory Core 和 4 个 MLU Core 共享的 SRAM（Shared RAM，共享存储单元）。
- Memory Core 不能执行向量和张量计算指令，只能用于 SRAM 与 DDR （Double Data Rate Synchronous Dynamic Random Access Memory，双倍速率同步动态随机存储器，DDR SDRAM 通常简称为 DDR）和 MLU Core 之间的数据传输。下图中展示了 MLU03 的核心架构，MLU03 采用 4 个 IPU 和一个 MPU 组成一个 Cluster（实际上 MLU02 也是），**IPU 上有大量的计算单元以及本地 scratchpad memory（NeuronRAM WeightRAM），MPU 上有 SharedRAM**，相当于 GPU 的 shared memory。不同 Cluster 数量可以组成不同的产品形态（云端、边缘端、IP）

![](https://picx.zhimg.com/v2-670f715c540659777ab5c1c72769d697_r.jpg)
寒武纪的MLU（Machine Learning Unit）架构是典型的NPU架构，使用分层的专用片上存储。MLU的基本计算单元是MLU Core，每个Core包含张量计算单元和向量计算单元。MLU的片上存储分为三层：

- NRAM（Neural RAM）是每个Core私有的高速存储，用于存储计算中间结果（如矩阵乘法累加器）；
- WRAM（Weight RAM）是每个Core私有的权重存储，专门用于存储神经网络权重；
- SRAM是多个Core共享的片上存储（约4MB/Cluster），用于Core间的数据共享。4个MLU Core组成一个Cluster，Cluster内部通过__sync_cluster()进行同步。MLU的这种分层存储设计与GPU的统一共享内存根本不同——NRAM/WRAM/SRAM按数据类型分区，由硬件自动管理，而GPU的共享内存可以存储任何类型的数据，由开发者/编译器管理。

在FlagTree中，寒武纪走Linalg路径，编译流水线为ttir→linalg→linalgopt→mluir→mluiropt→mlisa→cnbin（7阶段）。MLUIR是寒武纪的专用中间表示，用于描述NRAM/WRAM/SRAM的内存分配和数据流。

寒武纪的make_linalg和make_mluir使用大量mlu.passes.*专有pass，包括add_triton_to_hivm（HIVM转换）、add_triton_to_hfusion（算子融合）、add_triton_to_linalg（Linalg转换）等。

3.8 华为昇腾：达芬奇架构（Cube/Vector/Scalar）

![](https://pic2.zhimg.com/v2-41d9b9cf820d32b3f81c251cf1568a37_r.jpg)

![](https://pica.zhimg.com/v2-b4cd08752a07acccfd1a792f8cbce24e_r.jpg)
华为昇腾的达芬奇架构是典型的NPU架构，其AI Core包含三种专用计算单元：
Cube Unit（矩阵计算单元）、Vector Unit（向量计算单元）和Scalar Unit（标量计算单元）。

- Cube Unit专门执行矩阵乘法运算，可以处理16×16×16的矩阵分块，类似于GPU的Tensor Core但操作粒度更大。
- Vector Unit执行向量运算（如激活函数、归一化等），
- Scalar Unit执行标量运算（如控制流、地址计算等）。这三种计算单元通过流水线方式协同工作——Cube Unit完成矩阵乘法后，结果直接传递给Vector Unit进行后处理。
昇腾AI Core的存储模型也是分层的：

- Unified Buffer（UB）用于存储输入/输出数据，
- L0A/L0B/L0C用于存储矩阵乘法的A/B/C矩阵，这些缓冲区都是专用的，与计算单元直接相连。在FlagTree中，昇腾走Linalg路径，编译流水线为ttir→ttadapter(Linalg)→npubin（3-5阶段）。

- 昇腾使用triton_adapter_opt将TTIR转换为Linalg dialect，再使用bishengir-opt（毕昇编译器）将Linalg编译为npubin。
- 昇腾的ttir_to_linalg函数包含大量ascend.passes.ttir.*专有pass，包括add_auto_blockify（自动分块）、add_dag_sync/add_dag_scope（DAG分析）、add_triton_to_hivm（HIVM转换）、add_triton_to_hfusion（算子融合）等。昇腾的达芬奇架构是NPU设计哲学的典型代表——通过专用计算单元和分层存储来最大化AI计算的效率。

3.9 **各家芯片架构对比总结**

**表 3-1 各家芯片架构分类汇总**

芯片厂商架构类型计算单元存储模型编译路径NVIDIAGPGPUSM + Tensor Coreshared memory + tmemTritonGPUAMDGPGPUCU + Matrix Core(MFMA)LDSTritonGPU摩尔线程GPGPU(CUDA兼容)MUSA Core + Tensor Coreshared memoryTritonGPU海光GPGPU(HIP兼容)CU + Matrix CoreLDSTritonGPU天数智芯GPGPU(CUDA兼容)SM + Tensor Coreshared memory + tmemTritonGPU燧原NPU(GPGPU-like)Tensor Compute Kernelshared memoryTritonGPU+自定义寒武纪NPUMLU Core(张量+向量)NRAM/WRAM/SRAM分层Linalg华为昇腾NPUCube/Vector/ScalarUB/L0A/L0B/L0C专用Linalg

 3.9.1 架构融合趋势的深层分析

类GPU架构吸收NPU特点的具体表现包括：

- 第一，NVIDIA Hopper引入TMA，将数据传输从线程级提升到张量级，类似NPU的DMA引擎；
- 第二，NVIDIA Blackwell引入Tensor Memory（tmem），将累加器从通用寄存器分离到专用存储，类似NPU的专用累加器寄存器；
- 第三，NVIDIA Hopper和AMD CDNA3引入Warp Specialization，允许同一线程块内的不同warp执行不同任务，类似NPU的计算单元分工；
- 第四，所有类GPU架构都实现了软件流水线（add_pipeline），通过计算-通信重叠来隐藏延迟，这是NPU的核心优势之一。NPU向GPGPU靠拢的表现包括：

- 燧原GCU选择了TritonGPU编译路径，因为GCU的硬件设计（Tensor Compute Kernel、线程块/共享内存模型）足够接近GPGPU；
- 燧原GCU500进一步向标准GPGPU模型靠拢，在make_ttgir阶段直接做add_convert_to_ttgpuir（像NVIDIA/AMD一样），减少make_gcuir的定制化。

3.9.2 对编译路径选择的影响

架构融合趋势对编译路径选择有深远影响。

- 第一，类GPU架构吸收NPU特点后，需要新的编译pass来利用这些特性——如TMA需要tensor descriptor优化、tmem需要add_allocate_tensor_memory和add_promote_lhs_to_tmem、Warp Specialization需要add_hopper_warpspec/add_warp_specialize。这些pass在FlagTree的TritonGPU路径中已经实现。
- 第二，NPU向GPGPU靠拢后，可以复用TritonGPU的编译生态——燧原GCU就是例子，它走TritonGPU路径，通过自定义TritonGCU dialect来保留NPU特定优化。
- 第三，纯粹的NPU架构（如昇腾、寒武纪）仍然需要走Linalg路径，因为它们的硬件架构（Cube/Vector/Scalar、NRAM/WRAM/SRAM）与GPGPU模型差异太大，无法直接映射到TTGIR。这种架构融合趋势也解释了为什么FlagTree支持两条编译路径——它为不同架构成熟度的芯片提供了合适的接入方式。类GPU架构（包括向GPGPU靠拢的NPU如燧原）走TritonGPU路径，可以复用Triton社区的优化成果；纯NPU架构走Linalg路径，通过FLIR统一中间层适配各种专用架构。

**4. TritonGPU dialect 路径：类GPU芯片的核心区别**
所有选择 TritonGPU 路径的芯片厂商都遵循相同的编译框架：

- **Triton Python → TTIR → TTGIR → LLVM IR → 后端特定机器码。**其中：

- TTIR → TTGIR 是核心优化层，**各厂商在此阶段添加架构特定的优化 pass**。
- TTGIR → LLVM IR 是标准的 MLIR 到 LLVM 转换，各厂商主要在共享内存分配和 dialect 转换上做差异化。
- LLVM IR → 机器码是后端代码生成，各厂商使用自己的工具链（如 NVIDIA 的 ptxas、AMD 的 clang、摩尔线程的 mcc、天数智芯的 clang/llc）。
4.1 各家核心区别分析

4.1.1 NVIDIA：架构代际分化优化

NVIDIA 的核心区别在于按 GPU 架构代际分化优化路径。make_ttgir 中通过 capability // 10 判断架构代号（8=Ampere, 9=Hopper, 10=Blackwell），走不同的 pass 流水线。

- Hopper 架构使用 nvidia.passes.hopper.add_hopper_warpspec 进行 warp specialization，
- Blackwell 架构使用 nvidia.passes.ttnvgpuir.add_promote_lhs_to_tmem 将 LHS 提升到 Tensor Memory（tmem）。这种架构代际分化反映了 NVIDIA GPU 架构的快速演进——每代架构引入新的硬件特性（Hopper 的 warp specialization、Blackwell 的 tensor memory），编译器需要针对性地添加新 pass。
NVIDIA 的另一个核心区别是 Tensor Core 优化深度。

- passes.ttgpuir.add_f32_dot_tc（FP32 点积使用 Tensor Core，emu_tf32 控制是否模拟 TF32）
- passes.ttgpuir.add_accelerate_matmul（矩阵乘法加速）是 NVIDIA 特有的 Tensor Core 优化 pass，
- 这些 pass 直接利用 NVIDIA GPU 的 Tensor Core 硬件单元进行矩阵乘法加速。此外，make_llir 中的 nvidia.passes.ttgpuir.add_allocate_shared_memory_nv（NVIDIA 特定的共享内存分配）和 nvidia.passes.ttnvgpuir.add_allocate_tensor_memory（tmem 分配）也是 NVIDIA 独有的。

4.1.2 AMD：CDNA/RDNA 架构分化与 LDS 优化

AMD 的核心区别在于 CDNA（Compute DNA）和 RDNA（Radeon DNA）架构分化，以及 LDS（Local Data Share）内存模型。

- CDNA 架构（gfx908/90a/942 等）面向计算场景，使用 MFMA（Matrix Fused Multiply-Add）矩阵计算单元；
- RDNA 架构（gfx1xxx 等）面向图形场景。AMD 在 make_ttgir 中：

- amd.passes.ttgpuir.add_stream_pipeline（CDNA stream pipeline）和
- passes.ttgpuir.add_warp_specialize（pingpong 模式 warp specialization）进行 CDNA 特定优化。AMD 的另一个核心区别是 LDS 内存模型。与 NVIDIA 的 shared memory 不同，AMD GPU 使用 LDS（Local Data Share）作为片上共享内存。make_llir 中：

- amd.passes.ttgpuir.add_allocate_shared_memory 实际上是为 LDS 分配内存
- amd.passes.ttgpuir.add_optimize_lds_usage 优化 LDS 使用。此外，AMD 的 make_amdgcn 使用 amd.TARGET_TRIPLE（如 amdgcn-amd-amdhsa）和 arch 特定的 features（如 gfx11 系列使用 -real-true16 禁用真实 FP16），这些都与 NVIDIA 的 PTX 路径不同。

3.1.3 摩尔线程：MUSA 架构的 SQMMA 与 TME 优化

摩尔线程的核心区别在于 MUSA（Moore Threads Unified System Architecture）架构的 SQMMA 和 TME 优化。MUSA 是 CUDA 兼容架构，因此其编译流水线与 NVIDIA 高度相似，但使用 mcc（MUSA 编译器）而非 ptxas，最终产物是 mubin 而非 cubin。

- 摩尔线程在 make_ttgir 中使用 mthreads.passes.ttgpuir.add_accelerate_matmul 进行矩阵乘法加速，这可能将标准 dot 操作转换为 MUSA 特定的 SQMMA（Single-Quantum Matrix Multiply-Accumulate）指令。摩尔线程的另一个核心区别是 TLE（Triton Language Extension）的条件性使用。make_ttgir 中通过 hasattr 检查来条件执行 TLE 相关 pass（add_tle_optimize_local_pointer_async_stores、add_tle_early_assign_memory_space、add_tle_select_encodings 等），这种设计使得摩尔线程可以兼容不同版本的 FlagTree。

4.1.4 海光与天垓：生态兼容性驱动

海光（hcu）和天垓（iluvatar）的核心区别在于生态兼容性驱动。

- 海光 DCU 兼容 AMD ROCm/HIP 生态，因此其编译流水线与 AMD 完全一致（ttir→ttgir→llir→amdgcn→hsaco），但使用 hcu 命名空间的专有 pass（hcu.passes.ttgpuir.add_accelerate_matmul、add_stream_pipeline、add_warp_specialize_hcu、add_mls_stream_pipeline、add_block_pingpong），这些 pass 是海光对 AMD 标准 pass 的定制化版本。
- 天垓兼容 NVIDIA CUDA 生态，因此其编译流水线与 NVIDIA 高度相似（ttir→ttgir→llir→asm→cubin），使用 iluvatar 命名空间的专有 pass（iluvatar.passes.ttgpuir.add_accelerate_matmul、add_mma_reduce_thread_locality、add_optimize_epilogue），以及 iluvatar.passes.tle 系列 TLE pass。
海光和天垓的核心区别反映了它们各自兼容的生态：海光的 pass 命名（stream_pipeline、block_pingpong）与 AMD 一致，天垓的 pass 命名（hopper_warpspec、tmem）与 NVIDIA 一致。这种生态兼容性驱动的设计使得海光和天垓可以最大化复用 AMD/NVIDIA 的 Triton 优化成果，同时通过专有 pass 进行硬件特定优化。

**5. Linalg dialect 路径：NPU芯片的核心区别**
所有选择 Linalg 路径的芯片厂商都遵循相似的编译框架：**Triton Python → TTIR → Linalg dialect → 厂商特定 IR → 机器码**。

- 其中 TTIR → Linalg 是核心转换层，各厂商在此阶段将 T**riton 的 block-parallel IR 转换为 MLIR 的 Linalg 结构化操作**。
- Linalg → 厂商特定 IR 是各厂商的差异化优化层，使用各自的编译器（如寒武纪的 cnas、华为的 bishengir-opt、砺算的 thrive-opt）进行硬件特定优化。
5.1 各家核心区别分析 

5.1.1 寒武纪：七阶段流水线与 MLUIR 自定义 IR

寒武纪的核心区别在于七阶段编译流水线和 MLUIR 自定义 IR。寒武纪的流水线是所有厂商中最长的：**ttir → linalg → linalgopt → mluir → mluiropt → mlisa → cnbin**。

- **make_linalg 阶段使用大量 mlu.passes 专有 pass**（add_hot_cold_splitting、add_wrap_func_body_with_single_block、add_pointer_strength_reduction、add_triton_to_arith、add_arithext_to_linalg、add_triton_to_linalg、add_math_to_linalg 等），**将 Triton IR 逐步转换为 Linalg dialect**。
- make_optimized_linalg 使用 mlu.passes.add_auto_tile_pipeline 进行自动分块优化，针对 MLU 的 NRAM/WRAM/SRAM 内存层次进行 tiling。寒武纪的另一个核心区别是 MLUIR 自定义 IR。

- make_mluir 将 Linalg IR 转换为寒武纪专有的 MLUIR（MLU IR），
- 使用 mlu.passes.add_post_process_pipeline。
- MLUIR 描述了 MLU 硬件的操作（如 BANG 架构的算子），是 Linalg 与最终机器码之间的中间层
- make_optimize_mluir 调用 mlu.optimize_mluir 进行 MLU 特定优化（算子融合、内存分配优化）。make_mlisa 将 MLUIR 序列化为 MLISA（MLU ISA）文本，
make_cnbin 通过 cnas（寒武纪汇编器）和 cnlink（寒武纪链接器）编译为 cnfatbin。
这种七阶段流水线反映了寒武纪 MLU 架构的复杂性——NRAM/WRAM/SRAM 三级内存层次需要精细的 tiling 和内存分配优化。

5.1.2 华为昇腾：HIVM 中间表示与 DAG 调度

华为昇腾的核心区别在于 **HIVM（华为中间虚拟机）中间表示和 DAG 调度**。昇腾的流水线有三种模式：

- 标准 Linalg 路径（ttir→ttadapter→npubin）、
- Bytecode 模式（ttir→ttadapter→mlirbc→bcmlir→npubin）、
- SIMT 直通路径（ttir→npubin）。ttir_to_linalg 是核心转换层，使用 triton_adapter_opt 工具和大量 ascend.passes.ttir 专有 pass。
**昇腾的核心优化集中在 ttir_to_linalg 阶段:**
使用大量 ascend 专有 pass 进行自动分块、DAG 调度、HIVM 转换等。

- add_auto_blockify 是自动分块 pass，将 TTIR 的 block-parallel 结构自动分块为 NPU AI Core 可处理的子块。
- add_dag_sync、add_dag_scope、add_dag_ssbuffer 是自动调度 pass，基于 DAG（有向无环图）分析进行同步、作用域和缓冲区调度。
- add_triton_to_hivm 将 Triton IR 转换为 HIVM IR，这是毕昇编译器的中间表示。add_triton_to_hfusion 进行华为特定的算子融合优化。**这些 pass 将 Triton 的 GPU 编程模型映射到 NPU 的 AI Core 编程模型（Cube/Vector/Scalar 三种计算单元），是昇腾后端最核心的转换。**
linalg_to_npubin 调用 bishengir-opt（毕昇编译器）将 Linalg dialect 转换为 NPU 特定的指令集，支持 910 和 910B/910C 两种 NPU 型号的编译路径。

5.1.3 thrive阿里达摩院：ThriveIR + DSA 自定义路径

thrive的核心区别在于 ThriveIR 自定义 IR 和 DSA（Data Stream Architecture）模型。thrive的流水线是 ttir→thrir→thrmir→llir→dfcafb，其中 ThriveIR 和 ThriveMIR 是thrive自定义的中间表示。
make_thrir 通过 thrive-opt 命令行工具（而非 MLIR pass manager）将 TTIR 转换为 ThriveIR，
pass 序列包括：

-  triton-convert-to-triton-thrive（TTIR→ThriveIR）、
- triton-thrive-convert-gemm-op（GEMM 算子转换）、
- triton-thrive-layout-propagate（布局传播）、
- triton-thrive-software-pipeline（软件流水线）、
- triton-thrive-op-to-linalg（ThriveIR→Linalg）、
- triton-thrive-convert-linalg-to-dsa（Linalg→DSA）。thrive的另一个核心区别是 DSA（Data Stream Architecture）模型。
make_thrmir 将 ThriveIR 转换为 ThriveMIR（Thrive Machine IR），核心 pass 包括：

-  triton-thrive-memref-promote-sram（将 MemRef 提升到 SRAM）、
- triton-thrive-convert-simt-alloc（SIMT 分配转换）、
- triton-thrive-lower-with-thread-id（使用 thread_id 进行 lowering）。make_llir 使用 thrive-opt 和 dfca-mlir-opt 两个工具将 ThriveMIR 转换为 LLVM IR，make_fatbin 使用 mlir-translate、llvm-link、opt、dfcacc 四个工具完成最终编译。thrive的 VPU（Vector Processing Unit）和 DSA 模型不是标准 GPGPU，因此需要自定义的 ThriveIR 和 DSA 表示，但最终仍然回到 Linalg 和 LLVM IR 路径。

5.2 核心区别的根源分析

Linalg 路径各家的核心区别，根源在于三个维度：硬件内存层次差异、计算单元架构差异、厂商编译器工具链差异。
**表 3-1 Linalg 路径核心区别的根源分析**

区别维度寒武纪（MLU）华为昇腾（NPU）thrive（VPU+DSA）内存层次NRAM/WRAM/SRAM 三级AI Core 内部存储 + L1/L2SRAM + DSA 数据流计算单元BANG 架构算子Cube/Vector/Scalar 三种VPU 向量处理单元自定义IRMLUIR（MLU IR）HIVM（华为中间虚拟机）ThriveIR + ThriveMIR核心转换passadd_triton_to_linalgadd_triton_to_hivm +   add_triton_to_linalgtriton-convert-to-triton-thrive   + triton-thrive-op-to-linalg自动分块add_auto_tile_pipelineadd_auto_blockifytriton-thrive-tiling-pass算子融合mlu.optimize_mluiradd_triton_to_hfusiontriton-thrive-linalg-fuse-elementwise-ops厂商编译器cnas + cnlinkbishengir-opt（毕昇）thrive-opt + dfcacc最终产物cnfatbinnpubindfcafb流水线阶段数7 阶段3-5 阶段（多模式）5 阶段

第一，硬件内存层次差异是 Linalg 路径核心区别的最重要根源。

- 寒武纪 MLU 有 NRAM/WRAM/SRAM 三级内存，需要 add_auto_tile_pipeline 进行精细的 tiling 以适配不同级别的内存。
- 华为昇腾的 AI Core 有内部存储和 L1/L2 缓存，需要 add_auto_blockify 和 DAG 调度来优化数据流。
- thrive的 VPU+DSA 架构有 SRAM 和数据流模型，需要 triton-thrive-memref-promote-sram 将 MemRef 提升到 SRAM。
- 这些内存层次差异直接决定了各厂商的 tiling 和内存分配策略。第二，计算单元架构差异导致了自定义 IR 的分化。

- 寒武纪的 BANG 架构、昇腾的 Cube/Vector/Scalar、thrive的 VPU 都是各自硬件特定的计算单元，需要自定义 IR（MLUIR、HIVM、ThriveIR）来描述这些单元的操作。第三，厂商编译器工具链差异导致了最终代码生成的分化。

- 寒武纪的 cnas/cnlink、昇腾的 bishengir-opt、thrive的 thrive-opt/dfcacc 都是各自厂商的专有编译器，这些编译器接收 Linalg 或自定义 IR，输出硬件特定的机器码。
5.3 Linalg 路径面临的主要问题

选择 Linalg 路径的芯片厂商面临一系列共同的问题，这些问题源于 Linalg dialect 的抽象层次与硬件特定优化之间的张力。

5.3.1 TTIR → Linalg 转换的语义鸿沟

Linalg 路径的第一个核心问题是 TTIR → Linalg 转换的语义鸿沟。

- TTIR 是 Triton 的前端 IR，是块级并行的向量化的 IR，包含 tt.dot、tt.load、tt.store 等 Triton 特定操作。
- Linalg 是 MLIR 的结构化操作 dialect，使用 linalg.matmul、linalg.generic 等通用操作。
- 从 TTIR 到 Linalg 的转换需要将 Triton 的 block-parallel 语义映射到 Linalg 的结构化操作语义，这个映射不是一一对应的，存在语义鸿沟。**并行模型鸿沟：显式块级 SIMT  vs  隐式迭代空间并行**

- TTIR 的并行语义：是显式的块级并行（Block-Parallel），完全继承 SIMT 模型： 

- 有明确的`program_id`、`block_dim`、`num_blocks`概念，并行层级由程序员显式定义；
- 每个 Block 内部是向量化 / 张量级操作，并行性是 “块间分布式、块内向量化” 的两级结构；
- 并行边界、同步点（`tt.barrier`）都是显式的。
- Linalg 的并行语义：是隐式的迭代空间并行，完全没有线程、块的概念： 

- 只定义计算的迭代域（iteration domain）和索引映射，哪些维度可以并行、哪些是规约，完全由算子结构推导；
- 不存在显式的同步、块边界、线程 ID，并行性是编译器后续分析后自动挖掘的。
- 鸿沟体现：TTIR 中程序员手动划分的分块并行，无法直接对应到 Linalg 的张量维度。转换时需要先 “消去” 显式的 Block ID、块边界语义，把块级并行映射为张量的分片维度，再对应到 Linalg 的迭代空间。**访存模型鸿沟：显式指针多空间访存  vs  隐式逻辑张量读写**
这是所有厂商最头疼的核心鸿沟，也是寒武纪专门做了大量指针优化 Pass 的核心原因。

- TTIR 的访存语义：**是指针驱动的显式多层访存，是 Triton 最核心的特性：** 

- `tt.load`/`tt.store`携带指针地址、字节偏移、步长、内存空间（Global DRAM/Shared SRAM / 寄存器）、缓存提示（cache/evict）、边界掩码等大量属性；
- 访存和计算是分离的显式操作，**程序员可以精确控制数据在存储层级之间的搬运时机**。
- Linalg 的访存语义：是无指针的张量级隐式访存： 

- 只有逻辑张量作为操作数，没有指针、地址、偏移的概念，也不区分内存空间；
- 数据读写完全隐含在算子执行中，存储层次的分配、搬移是后续 Bufferization 阶段的工作。
- 鸿沟体现：TTIR 中大量的指针计算、地址偏移、内存空间切换，在 Linalg 中没有对应表达。**转换时必须先把 “指针 + 偏移 + 掩码” 的访存模式，规整为 “张量 + 切片索引” 的形式，剥离硬件访存属性，才能映射到 Linalg 的张量操作数。**补充：寒武纪 Triton-Linalg 方案的核心原创性就集中在这一层 —— 通过指针连续性分析、指针强度消减等专属 Pass，解决 “指针→张量” 的映射难题，这也是国产 DSA 芯片适配 Triton 的核心技术门槛之一。

**算子语义鸿沟：硬件绑定的专属算子  vs  通用结构化计算元语**

- TTIR 的算子：是Triton 专属、硬件强绑定的： 

- 既有`tt.dot`（直接映射 Tensor Core/MMA/Cube 指令）、`tt.reduce`、`tt.softmax`这类高层张量算子，也有大量 Triton 内置的原子操作、位操作、特殊函数；
- 算子语义隐含了硬件执行方式（比如`tt.dot`默认对应分块 MMA），不是纯数学定义。
- Linalg 的算子：是数学化的通用结构化元语： 

- 只有三类核心抽象：逐元素（elementwise）、规约（reduction）、张量收缩（contraction），所有计算都可以用`linalg.generic`加索引映射表达；
- 算子是纯数学语义，和硬件完全解耦，`linalg.matmul`只是 “二维张量收缩”，不隐含任何分块、指令映射。
- 鸿沟体现：Triton 特有的算子语义（比如带掩码的 dot、带布局的 reduce）无法直接对应 Linalg 的标准算子。要么把高层 Triton 算子拆解成基础算术元语再重组，要么引入自定义扩展算子，这也是必须分层转换的核心原因之一。**循环结构鸿沟：指针步进非结构化循环  vs  结构化迭代空间**

- TTIR 的循环：大多是指针步进式的非结构化循环： 

- 典型模式是**循环内做指针累加（`ptr += stride`），循环体内部包含访存、计算、指针更新，循环边界和张量维度没有显式绑定**；
- 循环的作用是 “迭代分块”，而非 “迭代张量元素”。
- Linalg 的循环：是和张量维度严格绑定的结构化循环： 

- 每个循环维度对应张量的一个轴，循环边界等于张量维度大小，循环变量直接作为张量索引；
- 循环结构和算子的迭代空间一一对应，是规整的嵌套结构。
- 鸿沟体现：TTIR 中 “指针 + 步进” 的循环，无法直接映射为 Linalg 的维度迭代循环。转换时需要先做指针强度消减、索引重构，**把指针步进还原为张量索引，才能对应到结构化循环**。**边界与掩码鸿沟：原生不规则分块掩码  vs  规则张量默认假设**

- TTIR 原生支持掩码：`tt.load`/`tt.store`/`tt.dot`都可以携带 mask 参数，天然处理张量边界的不完整分块（比如最后一行不足分块大小），这是 Triton 易用性的核心。
- Linalg 基于规则张量假设：**默认输入输出张量维度完整、规则，没有原生的掩码语义；不规则边界需要额外引入控制流或掩码张量，会大幅增加 IR 复杂度。**
- 鸿沟体现：如果直接把带 mask 的 TTIR 操作转成 Linalg，会生成大量冗余的掩码计算和分支。因此转换前必须先做掩码优化：能常量折叠的折叠、能消除的消除，实在无法消除的再转成 Linalg 可表达的逐元素掩码计算。比如寒武纪流水线中的`add_optimize_triangle_mask`，就是专门针对 Attention 场景的三角掩码做前置优化，降低后续转换的复杂度。从源码可以看到，各厂商都需要实现大量的专有 pass 来完成这个转换。

- 寒武纪的 make_linalg 使用了 add_triton_to_arith、add_arithext_to_linalg、add_triton_to_linalg、add_math_to_linalg 等一系列 pass，将 Triton 操作逐层降级为 Arith、ArithExt、Linalg 操作。
- 华为昇腾的 ttir_to_linalg 使用了 add_triton_to_structure、add_triton_to_hivm、add_triton_to_hfusion、add_triton_to_linalg 等 pass，先转换为 NPU 特定的结构化表示，再转换为 Linalg。
- thrive的 make_thrir 使用了 triton-convert-to-triton-thrive、triton-thrive-op-to-linalg 等 pass，先转换为 ThriveIR 再转换为 Linalg。这些复杂的转换流水线反映了 TTIR → Linalg 转换的语义鸿沟问题。
**寒武纪 MLU：分层降级 + 访存前置优化路线**
寒武纪`make_linalg`流水线的核心思路是：**先规整访存与指针，再逐层拆解算子语义，最终映射到 Linalg**，属于 “自底向上逐层剥离 Triton 语义” 的路线，也是最贴近标准 MLIR 生态的路线。

Pass 组对应解决的鸿沟核心逻辑指针优化组（pointer_strength_reduction、pointer_contiguity_enhancement等）访存模型鸿沟 + 循环结构鸿沟方案核心特色：先对 TTIR 的指针做深度分析与优化，把复杂的指针步进、偏移计算还原为规整的张量索引，提升访存连续性，为后续 “指针→张量切片” 的映射做准备add_triton_to_arith算子语义鸿沟第一层降级：把 Triton 专属的计算算子拆解成最基础的 Arith 加减乘除比较元语，彻底剥离 Triton 的算子外壳，降到通用算术 IR 层add_arithext_to_linalg + add_math_to_linalg算子语义鸿沟第二层抬升：把基础算术、扩展数学函数映射为linalg.elementwise，先把细粒度算子转换成结构化 Linalgadd_triton_to_linalg算子语义鸿沟 + 并行模型鸿沟高层映射：把tt.dot、tt.reduce这类大粒度张量算子，直接映射为linalg.matmul、linalg.reduce等结构化算子
路线优势：依赖标准 MLIR 方言（Arith/Math/Linalg），自研 Pass 集中在指针分析领域，复用性强；适合 MLU 这种和 GPU 存储模型差异相对可控的架构，也能降低其他 DSA 芯片接入 Triton 的门槛。

**华为昇腾：结构化提取 + 自研中间 IR 缓冲路线**
昇腾`ttir_to_linalg`流水线的核心思路是：**先提取结构化计算模式，再转入自研中间 IR 做硬件适配**，最后转标准 Linalg 复用生态，属于 “自研 IR 做桥梁” 的路线，也是国产 NPU 的典型方案。
根据 AscendNPU IR 的公开架构，昇腾的自研中间 IR 分为两层，和你提到的 Pass 完全对应：

- Hfusion 层：基于 Linalg 扩展的高层图级 IR，保留算子高层语义，负责数据预处理、算子简化、融合优化；
- HIVM 层：贴近硬件的底层 IR，显式包含 DMA 搬运、内存分配、向量 / Cube 指令，直接对应昇腾的计算单元。对应到你提到的转换 Pass：

Pass对应解决的鸿沟核心逻辑add_triton_to_structure并行模型鸿沟 + 循环结构鸿沟第一步先从 TTIR 中提取结构化的计算与分块模式，把显式块并行、指针循环规整为结构化的张量计算单元，先解决最底层的并行与循环语义差add_triton_to_hivm全鸿沟的硬件适配转入自研 HIVM 中间表示，承接 Triton 的语义并映射到昇腾的 Cube/Vector 计算单元、UB 存储、DMA 搬运；所有硬件相关的深度优化都在这一层完成add_triton_to_hfusion算子语义鸿沟在 Hfusion 层做算子融合优化，比通用 Linalg 融合更贴合昇腾硬件的融合规则，能保留更多高层语义用于后续调度add_triton_to_linalg最终语义映射从优化后的自研 IR 转成标准 Linalg，复用 MLIR 生态的通用分析与变换 Pass
路线优势：自研中间 IR 完全可控，能最大程度保留硬件优化空间，避免直接转 Linalg 的语义损失；适合昇腾这种和 GPU 架构差异较大的 NPU。

t**hriveIR 专属桥接路线**
t**hrive**的路线本质和华为一致，都是引入自研中间 IR 作为转换缓冲层：

- 第一步`triton-convert-to-triton-thrive`：将 TTIR 转换为自研 ThriveIR，这是介于 TTIR 和 Linalg 之间的中间层，既保留 Triton 的块并行、显式访存语义，又具备结构化张量的表达能力；
- 第二步`triton-thrive-op-to-linalg`：从结构化的 ThriveIR 映射到标准 Linalg。这种 “单中间层” 的路线，复杂度介于寒武纪的纯标准方言路线和华为的多层自研 IR 路线之间，兼顾了硬件定制空间和转换复杂度。

5.3.2 GPU 特定优化的缺失

Linalg 路径的第二个核心问题是 GPU 特定优化的缺失。TritonGPU 路径有大量成熟的 GPU 特定优化 pass，

- 如 add_coalesce（内存合并）、
- add_pipeline（软件流水线）、
- add_warp_specialize（warp 特化）、
- add_f32_dot_tc（Tensor Core 优化）等。这些 pass 直接利用 GPU 硬件特性进行优化，性能效果显著。Linalg 路径无法直接使用这些 pass，因为 Linalg 的抽象层次没有 GPU 特定的概念（如 warp、shared memory、Tensor Core）。
这意味着选择 Linalg 路径的厂商需要自己在 Linalg 层或更低层次实现类似的优化，或者放弃这些优化。从源码可以看到：

- 寒武纪通过 add_auto_tile_pipeline 进行自动分块优化，
- 华为昇腾通过 add_dag_sync/add_dag_scope 进行 DAG 调度优化，
- thrive通过 triton-thrive-software-pipeline 进行软件流水线优化。这些优化都是在 Linalg 或自定义 IR 层面进行的，不如 TritonGPU 的 GPU 特定优化精细。
特别是对于矩阵乘法这种核心算子，TritonGPU 的 add_accelerate_matmul 可以直接利用 Tensor Core/MFMA/SQMMA 等硬件矩阵计算单元，而 Linalg 路径需要在自定义 IR 层面（如寒武纪的 MLUIR、昇腾的 HIVM）进行类似的优化，增加了实现难度。

5.3.3 转换开销与编译时间

Linalg 路径的第三个核心问题是转换开销与编译时间。**Linalg 路径需要额外的 TTIR → Linalg 转换步骤，以及可能的 Linalg → 厂商特定 IR 转换步骤（如寒武纪的 Linalg→MLUIR、昇腾的 Linalg→HIVM）**。这些额外的转换步骤增加了编译时间和编译器的复杂性。
从源码可以看到，寒武纪的七阶段流水线（ttir→linalg→linalgopt→mluir→mluiropt→mlisa→cnbin）比 TritonGPU 路径的五阶段流水线（ttir→ttgir→llir→ptx→cubin）多了两个阶段，每个阶段都有多个 pass，编译时间更长。
华为昇腾的 ttir_to_linalg 使用了 triton_adapter_opt 外部工具（通过 subprocess 调用），这引入了进程启动开销和文件 I/O 开销。thrive的 make_thrir 和 make_thrmir 也使用 subprocess 调用 thrive-opt，同样有进程启动开销。

5.3.4 与 Triton 社区优化的隔离

Linalg 路径的第四个核心问题是与 Triton 社区优化的隔离。

- Triton 社区的优化主要集中在 TritonGPU 路径上，新 pass、新优化、新特性通常首先在 TritonGPU 路径上实现。选择 Linalg 路径的厂商无法直接受益于这些社区优化，需要自己将社区优化移植到 Linalg 路径，或者在自定义 IR 层面重新实现。这导致了 Linalg 路径的厂商在跟随 Triton 社区迭代节奏方面存在滞后。
- 例如，Triton 社区在 TritonGPU 路径上引入了 warp specialization、tensor memory、stream pipeline 等先进优化，这些优化在 Linalg 路径上没有对应的实现，选择 Linalg 路径的厂商需要自己实现类似功能。
5.4 Linalg 生态的利用好处

尽管 Linalg 路径面临上述问题，但利用 Linalg 生态也有显著的好处，这些好处是 TritonGPU 路径无法提供的。

5.4.1 硬件无关性与架构灵活性

Linalg 生态的最大好处是硬件无关性与架构灵活性。Linalg dialect 是 MLIR 的核心 dialect 之一，设计目标就是提供与硬件无关的结构化操作抽象。

- Linalg 的 tiling、fusion、bufferization 等通用优化可以灵活映射到各种 AI 加速器架构，包括 NPU、DSP、FPGA 等。这意味着选择 Linalg 路径的厂商可以更容易地支持新的硬件特性（如稀疏计算、动态形状等），因为 Linalg 的结构化操作可以灵活映射到各种硬件。
- 相比之下，TritonGPU 路径的 GPU 特定性使得支持非 GPU 特性更加困难——如果硬件引入了 GPU 没有的新特性，TritonGPU 模型可能无法表达。
5.4.2 结构化优化的稳定性

Linalg 生态的第三个好处是结构化优化的稳定性。

- Linalg 的 tiling、fusion、bufferization 等优化是基于结构化操作的，不依赖于特定的硬件参数（如 warp size、shared memory 大小），因此更加稳定和可预测。
- 相比之下，TritonGPU 路径的性能高度依赖于布局选择（BlockedEncodingAttr）、warp 分配、共享内存使用等 GPU 特定参数，这些参数的调优需要深入理解硬件的微架构特性，调优不当会导致性能大幅下降。Linalg 路径的优化更通用，调优参数更少，性能更稳定。

6. 燧原（Enflame）的策略深度分析

6.1 燧原的选择：NPU 走 TritonGPU 路径

燧原是 FlagTree 生态中唯一选择 TritonGPU 路径的 NPU 厂商。其编译流水线为 ttir→ttgir→gcuir→llir→fatbin，

- 其中 make_ttgir 是薄层（只做 fuse_nested_loops、cse、symbol_dce、canonicalizer 等通用优化，甚至不做 add_convert_to_ttgpuir），
- make_gcuir 是核心优化层（进行 TritonGPU→TritonGCU 转换、矩阵乘法加速、Warp Specialization、DMA 优化等 GCU 特定优化）。这种设计意味着燧原复用了 TritonGPU 的编程模型（线程块、warp、共享内存），但在其上构建了 GCU 特定的优化层（TritonGCU Dialect）。
从源码可以看到，燧原的 GCU 架构有代际分化：

- GCU300 使用 gcu_passes.gcu300.* 系列 pass（约 14 个），GCU300 侧重于 pingpong 流水线和 dot 布局优化，
- GCU400 使用 gcu_passes.gcu400.* 系列 pass（约 18+ 个），GCU400 侧重于 TLE 支持、Warp Specialization、矩阵乘加速和 wgdot 指令，
- GCU500 跳过 make_gcuir 直接走标准 TritonGPU 路径。GCU500 则更接近标准 TritonGPU 路径。这种代际分化反映了燧原硬件架构的演进——从 GCU300 的基础 GPGPU-like 到 GCU400 的增强 GPGPU 特性，再到 GCU500 的标准 GPGPU 路径。

6.2 选择 TritonGPU 路径的原因分析

6.2.1 GCU 硬件架构的 GPGPU 特性

燧原选择 TritonGPU 路径的首要原因是 GCU 硬件架构具有显著的 GPGPU 特性。

- 根据 Enflame 在 Hot Chips 33 上公开的 DTU 1.0（GCU300）架构信息，**GCU 包含 256 个 Tensor Compute Kernel，每个 kernel 支持 32 位 MAC、4x 16/8 位 MAC、全精度和混合精度计算**。
- 这种架构与 NVIDIA GPU 的 SM（Streaming Multiprocessor）+ Tensor Core 设计高度相似：**都有大量的并行计算单元、共享内存、warp 级别的同步机制**。
- GCU400（第二代）进一步增强了这些特性，支持 Warp Specialization（pingpong 模式），这是典型的 GPGPU 特性。相比之下，

- 华为昇腾 NPU 的达芬奇架构是一种完全不同的设计，它使用 AI Core（包含 Cube、Vector、Scalar 三种计算单元）和 AICPU 调度模型，没有传统 GPU 的线程块/warp/共享内存概念。
- 达芬奇架构的编程模型是基于算子和数据流的，而不是基于线程并行的。因此，昇腾必须走 Linalg 路径，将 Triton 的 block-parallel IR 转换为 Linalg 的结构化操作，再映射到达芬奇的 Cube/Vector 计算单元。**而燧原 GCU 的 GPGPU 特性使其可以直接复用 TritonGPU 的编程模型，无需经过 Linalg 转换**。

6.2.2 复用 TritonGPU 生态的技术红利

燧原选择 TritonGPU 路径的第二个原因是复用 TritonGPU 生态的技术红利。TritonGPU 是 Triton 生态中最成熟、最活跃的编译路径，NVIDIA、AMD、Intel 等主流 GPU 厂商都走 TritonGPU 路径，社区在此路径上投入了大量优化工作，包括 Tensor Core 加速、软件流水线、Warp Specialization、内存合并访问、布局优化等。如果燧原走 Linalg 路径，就需要自己实现这些优化，或者依赖 Linalg 生态的通用优化（这些优化不如 TritonGPU 的 GPU 特定优化精细）。
通过走 TritonGPU 路径，燧原可以直接复用社区的优化成果。从源码可以看到，

- make_ttgir 阶段使用了 passes.ttgpuir.add_fuse_nested_loops（循环融合）等社区 pass，make_gcuir 阶段也复用了 TritonGPU 的布局转换 pass（add_tritongpu_remove_layout_conversions）。这意味着燧原可以跟随 Triton 社区的迭代节奏，自动获得新的优化 pass，而不需要自己从头实现。
这种生态红利是 Linalg 路径无法提供的，因为 Linalg 路径的优化主要由各厂商自己维护。

6.2.3 TritonGCU Dialect 的设计意图

燧原选择 TritonGPU 路径的第三个原因是 TritonGCU Dialect 的设计意图。燧原在 make_gcuir 阶段引入了 TritonGCU Dialect，这是理解其设计意图的关键。
从源码可以看到:

- make_gcuir 首先调用 add_gcu_convert_triton_to_tritongpu 将 Triton IR 转换为 TritonGPU IR，
- 然后调用 add_triton_gpu_to_triton_gcu 将 TritonGPU IR 转换为 TritonGCU IR。这个两步转换的设计意图是：先复用 TritonGPU 的编程模型和布局系统，再在 TritonGCU 层进行 GCU 特定的优化。
TritonGCU Dialect 的核心价值在于它提供了一个 GCU 特定的优化空间，同时保留了 TritonGPU 的抽象层次。在 TritonGCU 层，燧原实现了:

- add_tritongcu_accelerate_matmul（矩阵乘法加速，利用 GCU 的 Tensor Compute Kernel）
- add_gcu_warp_specialization（Warp Specialization，GCU400 的 pingpong 模式）
- add_convert_triton_load_store_to_gcu_dma（将 Triton 的 load/store 转换为 GCU DMA 操作）
- add_triton_gcu_data_layout_optimize（数据布局优化）、
- add_triton_gcu_pingpong（pingpong 流水线）等优化。这些优化都是在 TritonGPU 的抽象层次上进行的，可以利用 TritonGPU 的布局系统（BlockedEncodingAttr）、warp 模型、共享内存模型等概念。

6.2.4 GCU500 的演进验证

燧原选择 TritonGPU 路径的第四个原因是 GCU500 的演进验证了这个选择。从源码可以看到，GCU500 在 make_ttgir 阶段直接调用 passes.ttir.add_convert_to_ttgpuir（像 NVIDIA/AMD 一样），跳过了 make_gcuir 的 TritonGPU→TritonGCU 转换。这表明燧原的架构在向标准 GPGPU 模型靠拢，减少自研 Dialect 的维护负担。
GCU500 的这种演进趋势表明燧原正在进一步拥抱 TritonGPU 生态，验证了最初选择 TritonGPU 路径的正确性——随着硬件架构的演进，燧原越来越接近标准 GPGPU，可以更多地复用 TritonGPU 的标准优化。

6.3 选择是否正确？

综合以上分析，燧原选择 TritonGPU 路径是一个正确的战略决策，但也是一个有风险的决策。正确性体现在以下几个方面：

- 第一，GCU 硬件架构的 GPGPU 特性使得 TritonGPU 路径是自然选择，避免了 Linalg 路径的语义鸿沟和转换开销。
- 第二，复用 TritonGPU 生态的技术红利使得燧原可以快速跟进社区的优化进展，降低软件开发成本
- 第三，TritonGCU Dialect 的设计使得燧原可以在复用 TritonGPU 抽象层次的同时进行 GCU 特定优化，兼顾了生态复用和硬件特定优化。
- 第四，GCU500 的演进验证了这个选择的可持续性——随着硬件架构向标准 GPGPU 靠拢，燧原可以更多地复用 TritonGPU 的标准优化。然而，这个选择也有风险。

- 燧原作为 NPU 厂商走 TritonGPU 路径，意味着其硬件架构必须持续保持与 GPGPU 编程模型的兼容性。如果未来 GCU 架构演进偏离 GPGPU 模型（如引入新的计算单元类型、新的内存层次结构），TritonGPU 路径可能无法充分利用这些新特性。
- 此外，TritonGCU Dialect 的维护负担和性能调优的复杂性也是需要持续关注的风险。总的来说，燧原需要持续评估 GCU 架构与 TritonGPU 模型的匹配度，确保硬件设计不偏离编程模型太远。

6.4 未来可能遇到的问题

6.4.1 硬件架构与编程模型不匹配的风险

燧原走 TritonGPU 路径的核心假设是 GCU 架构与 GPGPU 编程模型匹配。如果 GCU 硬件的某些特性与 TritonGPU 模型不匹配，就会导致性能损失或功能限制。例如，
TritonGPU 假设硬件**支持 warp 级别的同步和共享内存**，如果 GCU 的 warp 模型与 NVIDIA GPU 不同（如 warp size 不同、同步机制不同），就需要在 TritonGCU 层进行适配，这会增加复杂性。
从源码可以看到: 

- GCU400 限制 num_warps ≤ 4，而 GCU300 限制 num_warps ≤ 8，这暗示 GCU 的 warp 模型与标准 GPU（通常 num_warps ≤ 32）有差异
- 更大的风险是，如果未来 GCU 架构演进偏离 GPGPU 模型（如引入新的计算单元类型、新的内存层次结构），TritonGPU 路径可能无法充分利用这些新特性。
6.4.2 TritonGCU Dialect 的维护负担

燧原在 TritonGPU 之上构建了 TritonGCU Dialect，这带来了额外的维护负担。

- 第一，Dialect 定义维护：TritonGCU Dialect 的操作、类型、属性需要与 TritonGPU 保持兼容，当 TritonGPU dialect 变更时，TritonGCU 需要同步更新。
- 第二，Conversion pass 维护：TritonGPU → TritonGCU 的转换 pass（add_triton_gpu_to_triton_gcu）需要处理 TritonGPU 的所有操作和布局，当 TritonGPU 引入新的操作或布局时，转换 pass 需要扩展。
- 第三，优化 pass 维护：TritonGCU 层的优化 pass（如 add_tritongcu_accelerate_matmul、add_gcu_warp_specialization）需要与 GCU 硬件特性保持同步，当 GCU 硬件升级时，这些 pass 需要更新。从源码可以看到

- GCU300 和 GCU400 使用了不同的 pass 集合（gcu_passes.gcu300.* vs gcu_passes.gcu400.*），这意味着每代 GCU 硬件都需要维护一套独立的 pass。
- 随着 GCU 架构的演进（GCU300 → GCU400 → GCU500），维护多套 pass 的负担会越来越重。
6.4.3 性能调优的复杂性

TritonGPU 路径的性能调优比 Linalg 路径更复杂。TritonGPU 的性能高度依赖于布局选择（BlockedEncodingAttr）、warp 分配、共享内存使用等 GPU 特定参数。这些参数的调优需要深入理解 GCU 硬件的微架构特性（如 Tensor Compute Kernel 的调度、共享内存的带宽、DMA 的延迟等）。如果调优不当，TritonGPU 路径的性能可能不如 Linalg 路径——Linalg 的结构化优化（tiling、fusion）通常更稳定，不需要太多硬件特定调优。
从源码可以看到，燧原在 make_gcuir 阶段实现了大量性能优化 pass（矩阵乘法加速、Warp Specialization、DMA 优化、数据布局优化、pingpong 流水线等），这些 pass 的参数调优（如 num_stages、num_warps、vector_length）需要针对不同的 GCU 型号和工作负载进行精细调整。
这种调优的复杂性使得燧原的编译器性能高度依赖于工程经验，难以自动化。

6.4.5 与上游 Triton 的同步风险

燧原的 make_ttgir 薄层设计依赖上游 TritonGPU pass 的稳定性。从源码可以看到，
**make_ttgir 只做 fuse_nested_loops、cse、symbol_dce、canonicalizer 等通用优化**，不做 add_convert_to_ttgpuir（**GCU300/400 将这一步推迟到 make_gcuir**）。这种薄层设计意味着燧原有意识地保持 TTGIR 层的薄，让核心优化集中在 GCU 特定的 make_gcuir。
但这种设计也意味着燧原高度依赖上游 TritonGPU pass 的稳定性. 如果上游 Triton 修改了 TTGIR 的格式或 pass 的行为，燧原的 make_gcuir 可能需要同步调整。
GCU500 已经开始走不同路径（在 make_ttgir 阶段直接调用 add_convert_to_ttgpuir，跳过 make_gcuir 的 TritonGPU→TritonGCU 转换），这暗示燧原可能在简化编译路径，使其更接近标准 TritonGPU 路径。
这种趋势表明燧原正在进一步拥抱 TritonGPU 生态，减少自研 Dialect 的维护负担，但这也意味着 GCU500 可能更依赖 TritonGPU 的标准优化，GCU 特定优化的空间可能缩小。

6.5 燧原策略总结

**表 4-1 燧原 TritonGPU 路径 vs 昇腾 Linalg 路径对比**

维度燧原（TritonGPU 路径）昇腾（Linalg 路径）硬件架构GPGPU-like（Tensor Compute Kernel）达芬奇架构（Cube/Vector/Scalar）编程模型线程块/warp/共享内存（GPU 模型）算子/数据流（NPU 模型）中间表示TTGIR → TritonGCU IRLinalg dialect → HIVM核心优化层TritonGCU Dialect（make_gcuir）bishengir-opt（ttir_to_linalg）生态复用TritonGPU 社区优化MLIR Linalg 生态用户迁移成本低（与 GPU 编程模型一致）中（需理解 NPU 模型）维护成本中（依赖 FlagTree + 自研 GCU pass）高（自研 bishengir-opt + triton_adapter）硬件适配灵活性低（受 TritonGPU 模型约束）高（Linalg 硬件无关）性能调优复杂性高（GPU 特定参数多）中（结构化优化更稳定）与社区同步容易（TritonGPU 路径是社区主流）困难（Linalg 路径需自行跟进）
燧原的策略可以总结为：**以 GPGPU-like 的硬件架构为基础，选择 TritonGPU 路径最大化复用社区生态，通过 TritonGCU Dialect 进行 GCU 特定优化，随着硬件架构演进（GCU300→GCU400→GCU500）逐步向标准 TritonGPU 路径靠拢。**
这种策略的核心优势是生态复用和用户迁移成本低，核心风险是硬件架构与编程模型的匹配度、TritonGCU Dialect 的维护负担和性能调优的复杂性。
燧原需要持续评估 GCU 架构与 TritonGPU 模型的匹配度，在生态复用和硬件特定优化之间找到平衡点。