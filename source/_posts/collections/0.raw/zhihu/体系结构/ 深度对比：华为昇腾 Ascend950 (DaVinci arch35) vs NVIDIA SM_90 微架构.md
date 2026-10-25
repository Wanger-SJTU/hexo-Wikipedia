---
title: (1 封私信) 深度对比：华为昇腾 Ascend950 (DaVinci arch35) vs NVIDIA SM_90 微架构
date: "2026-04-02 00:00:00"
updated: "2026-04-02 00:00:00"
layout: post
permalink: /collections/0.raw/zhihu/体系结构/深度对比-华为昇腾-Ascend950-(DaVinci-arch35)-vs-NVIDIA-SM_90-微架构/
disableNunjucks: true
wiki: false
nav_hidden: true
categories:
  - 文档
tags:
  - 知乎
source_url: https://zhuanlan.zhihu.com/p/2020921487947736363
---


### 深度对比：华为昇腾 Ascend950 (DaVinci arch35) vs NVIDIA SM_90 微架构

** 本文从硬件架构、内存层次、编程模型、代码实例等多个维度，深入对比华为昇腾 Ascend950（DaVinci 架构 arch35 代）与 NVIDIA GPU Streaming Multiprocessor（SM）架构的设计哲学与实现差异。适合 AI 系统工程师、算子开发者以及对国产 AI 芯片感兴趣的读者。
#### 目录

- [引言：两条不同的路径](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#1-%E5%BC%95%E8%A8%80%E4%B8%A4%E6%9D%A1%E4%B8%8D%E5%90%8C%E7%9A%84%E8%B7%AF%E5%BE%84)
- [芯片全局架构鸟瞰](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#2-%E8%8A%AF%E7%89%87%E5%85%A8%E5%B1%80%E6%9E%B6%E6%9E%84%E9%B8%9F%E7%9E%B0)
- [核心计算单元深度解剖](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#3-%E6%A0%B8%E5%BF%83%E8%AE%A1%E7%AE%97%E5%8D%95%E5%85%83%E6%B7%B1%E5%BA%A6%E8%A7%A3%E5%89%96)
- [内存层次与数据流对比](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#4-%E5%86%85%E5%AD%98%E5%B1%82%E6%AC%A1%E4%B8%8E%E6%95%B0%E6%8D%AE%E6%B5%81%E5%AF%B9%E6%AF%94)
- [编程模型与并行模型对比](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#5-%E7%BC%96%E7%A8%8B%E6%A8%A1%E5%9E%8B%E4%B8%8E%E5%B9%B6%E8%A1%8C%E6%A8%A1%E5%9E%8B%E5%AF%B9%E6%AF%94)
- [代码实战：向量加法 (Vector Add)](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#6-%E4%BB%A3%E7%A0%81%E5%AE%9E%E6%88%98%E5%90%91%E9%87%8F%E5%8A%A0%E6%B3%95-vector-add)
- [代码实战：矩阵乘法思路对比](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#7-%E4%BB%A3%E7%A0%81%E5%AE%9E%E6%88%98%E7%9F%A9%E9%98%B5%E4%B9%98%E6%B3%95%E6%80%9D%E8%B7%AF%E5%AF%B9%E6%AF%94)
- [Ascend950 独有特性解析](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#8-ascend950-%E7%8B%AC%E6%9C%89%E7%89%B9%E6%80%A7%E8%A7%A3%E6%9E%90)
- [性能优化哲学差异](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#9-%E6%80%A7%E8%83%BD%E4%BC%98%E5%8C%96%E5%93%B2%E5%AD%A6%E5%B7%AE%E5%BC%82)
- [硬件参数横向对比表](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#10-%E7%A1%AC%E4%BB%B6%E5%8F%82%E6%95%B0%E6%A8%AA%E5%90%91%E5%AF%B9%E6%AF%94%E8%A1%A8)
- [总结与展望](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#11-%E6%80%BB%E7%BB%93%E4%B8%8E%E5%B1%95%E6%9C%9B)
- [参考资料](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#12-%E5%8F%82%E8%80%83%E8%B5%84%E6%96%99)

#### 1. 引言：两条不同的路径

NVIDIA 和华为昇腾代表了两条截然不同的 AI 加速器设计哲学：

维度NVIDIA GPU (SM_90)华为昇腾 (DaVinci AI Core)设计起源图形渲染 → 通用并行计算 → AI 加速从零开始为 AI 设计的专用架构核心理念统一架构（CUDA Core + Tensor Core 共享资源）专用双子单元（AIC/AIV 物理分离，各有独立流水线）数据管理硬件自动管理缓存，对开发者透明L2 自动缓存 + 开发者显式管理 UB 数据搬运编程模型SIMT 线程级并行SPMD + SIMD/SIMT 双模型（950 新增 SIMT）
#### 2. 芯片全局架构鸟瞰

#### NVIDIA H100 (Hopper 架构)

`┌──────────────────────────────────────────────────────────┐
│                    NVIDIA H100 GPU                       │
│                                                          │
│  ┌─────────┐ ┌─────────┐ ┌─────────┐     ┌─────────┐     │
│  │  GPC 0  │ │  GPC 1  │ │  GPC 2  │ ... │  GPC 7  │     │
│  │ ┌─────┐ │ │ ┌─────┐ │ │ ┌─────┐ │     │ ┌─────┐ │     │
│  │ │ SMs │ │ │ │ SMs │ │ │ │ SMs │ │     │ │ SMs │ │     │
│  │ └─────┘ │ │ └─────┘ │ │ └─────┘ │     │ └─────┘ │     │
│  └─────────┘ └─────────┘ └─────────┘     └─────────┘     │
│                                                          │
│            ┌──────────────────────────┐                  │
│            │    L2 Cache (50 MB)      │                  │
│            └──────────────────────────┘                  │
│                                                          │
│  ┌─────────────────────────────────────────────────┐     │
│  │          HBM3 Memory (80 GB, 3.35 TB/s)         │     │
│  └─────────────────────────────────────────────────┘     │
└──────────────────────────────────────────────────────────┘

H100 SXM5: 8 GPC, 共 132 SM (各 GPC 含 16~18 SM 不等)
每个 SM: 128 FP32 CUDA Cores + 4 Tensor Cores`

> 参考**：NVIDIA Hopper Architecture In-Depth

#### 华为昇腾 Ascend950 (DaVinci arch35)

`┌───────────────────────────────────────────────────────────┐
│                   Ascend950 NPU (4Die 合封)               │
│                                                           │
│  ┌─ 计算 DIE 0 ──────────────────────────────────────┐    │
│  │ ┌──────────┐ ┌──────────┐     ┌──────────┐        │    │
│  │ │AI Core 0 │ │AI Core 1 │ ... │AI Core 15│        │    │
│  │ │ ┌──────┐ │ │ ┌──────┐ │     │ ┌──────┐ │        │    │
│  │ │ │Scalar│ │ │ │Scalar│ │     │ │Scalar│ │        │    │
│  │ │ │Vector│ │ │ │Vector│ │     │ │Vector│ │        │    │
│  │ │ │ Cube │ │ │ │ Cube │ │     │ │ Cube │ │        │    │
│  │ │ │ MTE  │ │ │ │ MTE  │ │     │ │ MTE  │ │        │    │
│  │ │ └──────┘ │ │ └──────┘ │     │ └──────┘ │        │    │
│  │ └──────────┘ └──────────┘     └──────────┘        │    │
│  └───────────────────────────────────────────────────┘    │
│  ┌─ 计算 DIE 1 ──────────────────────────────────────┐    │
│  │ ┌──────────┐ ┌──────────┐     ┌──────────┐        │    │
│  │ │AI Core 16│ │AI Core 17│ ... │AI Core 31│        │    │
│  │ └──────────┘ └──────────┘     └──────────┘        │    │
│  └───────────────────────────────────────────────────┘    │
│                                                           │
│  ┌───────────────────────────────────────────────────┐    │
│  │       L2 Cache（核外共享，带宽 ~7 TB/s）          │    │
│  └───────────────────────────────────────────────────┘    │
│                                                           │
│  ┌───────────────────────────────────────────────────┐    │
│  │         HBM (Global Memory) — 双 DIE UMA          │    │
│  └───────────────────────────────────────────────────┘    │
│                                                           │
│  ┌─ IO DIE 0 ────────┐  ┌─ IO DIE 1 ────────┐             │
│  │ UB Switch (9 Port) │  │ UB Switch (9 Port) │           │
│  │ CCU (集合通信加速) │  │ CCU (集合通信加速) │           │
│  └────────────────────┘  └────────────────────┘           │
└───────────────────────────────────────────────────────────┘

Ascend950: 2 × 计算 DIE × 16 AI Core = 32 AI Core（CANN Meetup 官方分享确认每计算 DIE 16 核）
每个 AI Core: Scalar Unit + Vector Unit + Cube Unit + MTE2/MTE3
UB (Unified Buffer): 248 KB per AI Core
互联：18 × X4 UB 端口，支持 CCU1.0 集合通信加速器`

<strong>参考</strong>：昇腾官方文档 - 基本架构
#### 芯片架构代号与产品映射

昇腾芯片采用 NpuArch 来标识微架构代际：

代号NpuArch架构编译宏代表芯片UB 大小A22201DAV_2201Ascend910B192 KBA32201DAV_2201Ascend910_93192 KBA53510DAV_3510Ascend950DT / 950PR248 KB其中 <strong>Ascend950PR</strong>（Prefill）定位中等算力/带宽、低成本，适用于 <strong>LLM 预填充、推荐、多模态</strong>；<strong>Ascend950DT</strong>（Decode）定位高算力/带宽、中等成本，适用于 <strong>LLM 生成（Decode）和训练</strong>。

<strong>Chiplet 封装</strong>：Ascend950 采用 <strong>4Die 合封</strong>设计（2× 计算 DIE + 2× IO DIE），相比上一代从 2Die 升级到 4Die。将 Compute 与 IO 进行切割的好处：1) 可控制 Die Size 提升良率；2) IO-Die 与工艺相关度弱，可独立演进。每个计算 DIE 包含 16 个 AI Core，双 DIE 支持 UMA（统一内存访问），提升易用性。

<strong>参考</strong>：CANN Skills - NPU Arch Guide
#### 关于 UB 大小的两种视角

<strong>不同资料中出现的 UB 大小差异说明</strong>：

华为官方 CANN 文档和 Ascend C 编程接口中，UB 大小指的是<strong>每个 AI Vector 子核心（AIV）可用的 Unified Buffer 容量</strong>——910B 为 <strong>192 KB</strong>，950 为 <strong>248 KB</strong>（Skills 仓库数据）。这是 Ascend C 开发者实际面对的编程约束。

但从完整的 DaVinci Core <strong>硬件物理架构</strong>角度看，每个 AI Core 实际包含 <strong>AIC（AI Compute）+ AIV（AI Vector）双子单元</strong>（详见下文 3.3 节）。部分社区资料（如知乎分析文章）在描述 UB 时会从整个 DaVinci Core 的视角给出更大的数值（如 910B 写为 2×192 KB），这与 CANN 编程文档的口径并不矛盾，只是量度层面不同。但 AIC 子核心的 UB 具体大小是否与 AIV 完全相同，<strong>目前尚无官方公开文档明确说明</strong>。

本文后续所有 UB 大小均以 <strong>Ascend C 编程视角（每 AIV 子核心可用量）</strong> 为准，与华为 CANN 官方文档口径一致。

#### 3. 核心计算单元深度解剖

#### 3.1 NVIDIA SM_90 (Streaming Multiprocessor) 内部结构

以 H100 Hopper SM_90 为例：

`┌──────────────────────────────────────────────────────────┐
│                   H100 SM_90 (Hopper)                    │
│                                                          │
│  ┌───────────────────────────────────────────────────┐   │
│  │                 4× Warp Scheduler                 │   │
│  │      (每个调度 1 个 Warp = 32 线程)                │   │
│  └───────────────────────────────────────────────────┘   │
│                                                          │
│  ┌───────────┐ ┌───────────┐ ┌───────────┐ ┌───────────┐ │
│  │ Sub-Core 0│ │ Sub-Core 1│ │ Sub-Core 2│ │ Sub-Core 3│ │
│  │           │ │           │ │           │ │           │ │
│  │ 32×FP32   │ │ 32×FP32   │ │ 32×FP32   │ │ 32×FP32   │ │
│  │ 16×FP64   │ │ 16×FP64   │ │ 16×FP64   │ │ 16×FP64   │ │
│  │ 1×Tensor  │ │ 1×Tensor  │ │ 1×Tensor  │ │ 1×Tensor  │ │
│  │ 4×SFU     │ │ 4×SFU     │ │ 4×SFU     │ │ 4×SFU     │ │
│  │ 4×LSU     │ │ 4×LSU     │ │ 4×LSU     │ │ 4×LSU     │ │
│  └───────────┘ └───────────┘ └───────────┘ └───────────┘ │
│                                                          │
│  ┌───────────────────────────────────────────────────┐   │
│  │        Register File: 256 KB (65536×32-bit)       │   │
│  └───────────────────────────────────────────────────┘   │
│  ┌───────────────────────────────────────────────────┐   │
│  │  Shared Memory / L1 Cache: 256 KB 统一 SRAM       │   │
│  │  (共享内存最高可配置至 228 KB，其余为 L1 缓存)       │   │
│  └───────────────────────────────────────────────────┘   │
│  ┌───────────────────────────────────────────────────┐   │
│  │          Tensor Memory Accelerator (TMA)          │   │
│  └───────────────────────────────────────────────────┘   │
└──────────────────────────────────────────────────────────┘`

<strong>H100 SM_90 关键参数</strong>：

- <strong>128 FP32 CUDA Cores</strong>（分布在 4 个 Sub-Core 中）
- <strong>4 个第四代 Tensor Core</strong>（支持 FP8/FP16/BF16/TF32/FP64/INT8）
- <strong>4 个 Warp Scheduler</strong>（每周期可调度 4 个 Warp）
- <strong>256 KB</strong> 统一 L1/共享内存 SRAM（共享内存最高可配置至 <strong>228 KB</strong>，剩余分配给 L1 缓存/Texture 缓存）
- <strong>256 KB</strong> 寄存器文件
- <strong>新增 TMA</strong>（Tensor Memory Accelerator，异步批量数据搬运）
<strong>参考</strong>：NVIDIA Hopper Architecture In-Depth
#### 3.2 昇腾 AI Core (DaVinci arch35) 内部结构

**

![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_7bb9884a2bc0.jpg)

arch35 AI Core 关键参数**：

- <strong>Scalar Unit</strong>：程序流控制，地址计算
- <strong>Vector Unit</strong>：向量计算，支持 FP32/FP16/BF16/FP8
- <strong>Cube Unit</strong>：矩阵乘法，支持 FP16/BF16/HF32/FP32/INT8/FP8(E4M3/E5M2)/MXFP8/MXFP4/HiF8
- <strong>MTE2</strong>：GM → UB 的异步 DMA 搬运引擎
- <strong>MTE3</strong>：UB → GM 的异步 DMA 搬运引擎
- <strong>UB (Unified Buffer)</strong>：<strong>248 KB</strong>（相比 910B 的 192 KB 增加 29%）
- <strong>L1 Buffer</strong>：核内通用数据中转区，主要暂存需要反复使用的数据（Cube 路径：GM → L1 → L0A/L0B）
- <strong>L0A/L0B/L0C</strong>：Cube Unit 专用寄存器级缓存
- <strong>arch35 新增数据通路</strong>（来源：CANN Meetup 官方分享）：  

- <strong>L0C → UB</strong>：Cube 计算结果可直接写入 UB，供 Vector 使用（Cube-Vector 融合通路的基础）
- <strong>UB → L1</strong>：支持 UB 数据回写 L1 进行缓存复用
- <strong>SSBuf</strong>：CV 之间的消息通路，支持 AIC/AIV 核间同步

**

> 参考**：昇腾官方文档 - AI Core 基本架构

#### 3.3 DaVinci Core 的 AIC/AIV 双子单元架构

DaVinci 架构从 910B 起，每个 AI Core 实际上包含两个<strong>协同工作的子核心</strong>：

**

![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_a3808c099a54.jpg)

AIC（AI Compute 子核心）**：

- 拥有独立的 Scalar、<strong>Cube Unit</strong>、MTE2/MTE3、UB
- 专门负责<strong>矩阵乘法</strong>（GEMM）路径
- 数据流：GM → L1 → L0A/L0B → Cube → L0C → Fixpipe → GM 或 <strong>L0C → UB</strong>（950 新增 CV 通路）
<strong>AIV（AI Vector 子核心）</strong>：

- 拥有独立的 Scalar、<strong>Vector Unit</strong>、MTE2/MTE3、UB
- 专门负责<strong>向量计算</strong>（Activation、Norm、Element-wise 等）
- 数据流：GM → UB → Vector → UB → GM
<strong>Fixpipe 后处理单元</strong>：

- 位于 Cube Unit 输出端（L0C 之后），是 950 架构的重要新特性
- 可在 Cube 输出后<strong>直接执行</strong>数据类型转换、Bias 加法、激活函数等操作
- 支持将 L0C 结果<strong>直接输出到 UB</strong>（L0C → UB 新通路），供 AIV 的 Vector 单元继续处理
- 支持 <strong>DualDst 模式</strong>：将 L0C 中的 M×N 矩阵按 M 或 N 维度拆分，同时写入两个 AIV 核的 UB
- 显著提升 Transformer 中 GEMM+Bias+GeLU 等融合算子的效率
<strong>与 NVIDIA 的对比</strong>：NVIDIA SM 中 Tensor Core 和 CUDA Core 共享同一套 Register File 和 Shared Memory，属于统一架构；昇腾的 AIC/AIV 物理分离，各有独立 UB 和流水线，更像是核内集成了两条专用处理流水线，矩阵路径和向量路径可完全独立调度。
#### 3.4 Ascend C 编程与物理架构的映射关系

在 Ascend C 编程中，开发者看到的是<strong>逻辑上的 AI Core</strong>，其映射规则为：

Ascend C 逻辑视角物理硬件说明一个 “AI Core” (Vector 算子)AIV 子核心开发者通过 blockIdx 区分，UB = 192⁄248 KB一个 “AI Core” (Cube 算子)AIC 子核心Cube 路径使用独立的 L0A/L0B/L0CGetBlockNum() 返回值≤ 物理核数 × 2AIC 和 AIV 可分别调度因此，开发者<strong>不需要直接感知</strong> AIC/AIV 的分离——Ascend C 编译器和运行时会自动将 Vector 算子调度到 AIV、Cube 算子调度到 AIC。但理解这一物理架构有助于：

- 解释为何”同一个 Core”可以同时执行 Cube 和 Vector 算子（实际是双子单元并行）
- 理解 Fixpipe 为何能在 Cube 输出后直接做后处理（物理上位于 AIC 内部）
- 正确规划 UB 大小时选择正确的基准值（每 AIV 的 192⁄248 KB，而非整个 Core 的总量）

#### 3.5 计算单元对比总览

维度NVIDIA SM_90 (H100)昇腾 AI Core (arch35)通用计算128× CUDA Core (FP32/INT32)Vector Unit (SIMD 向量引擎)矩阵加速4× Tensor Core (第四代)Cube Unit (矩阵乘法引擎)特殊函数4× SFU (sin/cos/exp)Scalar Unit 或 Vector 指令流控制4× Warp SchedulerScalar Unit访存单元4× LSU (Load/Store)MTE2 (GM→UB/L1) · MTE1 (L1→L0) · MTE3 (UB→GM) · FixPipe (L0C→GM)<strong>核心差异</strong>：SM_90 的 Tensor Core 和 CUDA Core <strong>共享同一套寄存器和共享内存</strong>（统一架构）；AI Core 的 AIC/AIV <strong>物理分离、各有独立 UB 和流水线</strong>（双子单元并行架构）。详细参数见[第 10 节对比表](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#10-%E7%A1%AC%E4%BB%B6%E5%8F%82%E6%95%B0%E6%A8%AA%E5%90%91%E5%AF%B9%E6%AF%94%E8%A1%A8)。

#### 4. 内存层次与数据流对比

#### 4.1 内存层次对比

**

![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_dce58cf0ba9a.jpg)

#### 4.2 L2 Cache 对比

L2 Cache 是连接片上计算核心与片外 HBM 的关键缓存层级，对实际带宽利用率和算子性能有决定性影响。两种架构在 L2 Cache 的设计理念、容量和使用方式上存在显著差异。

#### NVIDIA H100：大容量硬件管理 L2 Cache

![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_a2bb5f1fb207.jpg)

H100 L2 Cache 特点**：

- <strong>50 MB</strong> 容量（SXM5），PCIe 版也是 50 MB（芯片全规格 60 MB，部分屏蔽）
- 采用<strong>分区设计</strong>（Partitioned L2）：分为 Near 和 Far 两个分区，访问 Near 分区延迟低，跨分区访问延迟接近翻倍
- <strong>硬件全自动管理</strong>：对开发者完全透明，所有全局内存访问自动经过 L2
- L2 带宽远高于 HBM 带宽（~5.5 TB/s vs ~2 TB/s），是隐藏 HBM 延迟的核心机制
- 支持 <strong>L2 Persistent Cache Control</strong>（CUDA 11.0+，compute capability 8.0+），允许开发者<strong>显式配置 L2 Cache 亲和性</strong>
<strong>NVIDIA L2 Cache 开发者控制 API</strong>：

`// 1. 预留 L2 Cache 空间给持久化数据
cudaDeviceProp prop;
cudaGetDeviceProperties(&prop, device_id);
size_t persistSize = min(int(prop.l2CacheSize * 0.75), prop.persistingL2CacheMaxSize);
cudaDeviceSetLimit(cudaLimitPersistingL2CacheSize, persistSize);

// 2. 设置 Stream 级别的 L2 访问策略窗口
cudaStreamAttrValue attr;
attr.accessPolicyWindow.base_ptr  = reinterpret_cast(data_ptr);  // 需要驻留的数据地址
attr.accessPolicyWindow.num_bytes = data_size;                          // 驻留数据大小
attr.accessPolicyWindow.hitRatio  = 0.6;                                // 命中率提示（防止缓存抖动）
attr.accessPolicyWindow.hitProp   = cudaAccessPropertyPersisting;       // 命中时：保持驻留
attr.accessPolicyWindow.missProp  = cudaAccessPropertyStreaming;        // 未命中时：流式访问（优先驱逐）
cudaStreamSetAttribute(stream, cudaStreamAttributeAccessPolicyWindow, &attr);

// 3. 使用完毕后重置
attr.accessPolicyWindow.num_bytes = 0;
cudaStreamSetAttribute(stream, cudaStreamAttributeAccessPolicyWindow, &attr);
cudaCtxResetPersistingL2Cache();  // 清除所有持久化缓存行`

<strong>三种访问属性</strong>：

属性含义适用场景cudaAccessPropertyPersisting数据优先驻留 L2被多次反复读取的热数据（如权重矩阵）cudaAccessPropertyStreaming数据优先驱逐只访问一次的冷数据（如中间结果）cudaAccessPropertyNormal默认行为（重置）清除之前的持久化设置<strong>参考</strong>：CUDA Programming Guide - L2 Cache Control、Nvidia’s H100: Funny L2, and Tons of Bandwidth - Chips and Cheese
#### 昇腾 Ascend950：L2 Cache 作为 GM 加速层

<strong>昇腾 L2 Cache 特点</strong>：

- 位于 AI Core <strong>外部</strong>，所有 AI Core <strong>共享</strong>同一个 L2 Cache
- 所有通过 MTE2/MTE3 搬运单元读写 GM 的数据，<strong>默认被缓存在 L2 Cache 中</strong>
- L2 Cache 以 <strong>cacheline</strong> 为单位加载数据（arch35 的 cacheline 为 <strong>128 字节</strong>，较前代 512 字节大幅细化，改善离散访问效率）
- L2 Cache 带宽约 <strong>7 TB/s</strong>（读写混合），远高于 HBM 带宽，是提升算子实际带宽利用率的关键
- CANN 官方最佳实践建议：<strong>当输入输出数据量超过 L2 Cache 大小时，应在 Tiling 中使能 L2 Cache 切分策略</strong>，确保每轮计算的数据量能被 L2 Cache 容纳
- 开发者可通过 `SetL2CacheHint` API <strong>显式配置 L2 Cache 亲和性</strong>（详见下文）
<strong>⚠️ 关于 192 MB L2 Cache 的可靠性</strong>：华为 CANN 最佳实践文档（CANN 商用版 8..1）中，使用 <strong>“假设，AI 处理器的 L2 Cache 大小为 192MB”</strong> 作为教学示例参数。经核实，这是文档中的<strong>假设性描述</strong>（原文：”假设，AI处理器的L2Cache大小为192MB”），并非对任何具体型号的规格确认。华为在所有公开文档中<strong>均未标注</strong> Ascend 950（Atlas A3）或 910B（Atlas A2）的 L2 Cache 具体容量。192 MB 作为参考值有一定可信度（文档团队不太可能用完全脱离实际的数值做教学示例），但<strong>不能作为官方确认的规格参数</strong>引用。**昇腾 L2 Cache 开发者亲和性控制——`SetL2CacheHint` API**：

开发者可以通过 `GlobalTensor` 提供的 `SetL2CacheHint` 接口，<strong>逐 Tensor 粒度</strong>地控制 L2 Cache 行为，决定哪些数据进入 L2 Cache、哪些绕过（bypass）：

`// 昇腾 Ascend C：显式配置 L2 Cache 亲和性

```text
// 场景：x 需要被 40 个核反复读取，y 和 z 只读写一次

// 设置 GlobalBuffer
```

xGm.SetGlobalBuffer((__gm__ float *)x + blockIdx * TILE_N);
yGm.SetGlobalBuffer((__gm__ float *)y + blockIdx * TILE_N);
zGm.SetGlobalBuffer((__gm__ float *)z + blockIdx * TILE_N);

```text
// x 保持默认 CACHE_MODE_NORMAL —— 数据经过 L2 Cache（被频繁复用）
// y 和 z 设置为 CACHE_MODE_DISABLE —— 数据绕过 L2 Cache（只访问一次）
```

yGm.SetL2CacheHint(AscendC::CacheMode::CACHE_MODE_DISABLE);
zGm.SetL2CacheHint(AscendC::CacheMode::CACHE_MODE_DISABLE);`

<strong>两种 CacheMode 说明</strong>：

CacheMode含义适用场景CACHE_MODE_NORMAL数据经过 L2 Cache（默认）需要被多个核或多次迭代反复读取的热数据CACHE_MODE_DISABLE数据绕过 L2 Cache只访问一次的冷数据，避免其挤占宝贵的 L2 Cache 空间<strong>实战案例——vLLM-Ascend 中的动态 L2 亲和性</strong>：

`// 来自 vLLM-Ascend 项目：Grouped MatMul 算子中的权重矩阵 L2 策略
weightGM.SetGlobalBuffer(GetTensorAddr(groupIdx, weightTensorPtr) + offset);

```text
if (mnConfig.blockDimM == 1) {
    // M 维度只有 1 个分块 → 权重只被读取一次 → 绕过 L2
    weightGM.SetL2CacheHint(CacheMode::CACHE_MODE_DISABLE);
```

} else {

```text
    // M 维度有多个分块 → 权重被多个核复用 → 进入 L2
    weightGM.SetL2CacheHint(CacheMode::CACHE_MODE_NORMAL);
```

}`

<strong>💡 与 NVIDIA 对比</strong>：NVIDIA 的 `cudaAccessPolicyWindow` 是 <strong>Stream 级别</strong>的控制（指定一个连续内存区域 + hitRatio），粒度较粗；昇腾的 `SetL2CacheHint` 是 <strong>Tensor 级别</strong>的控制（每个 GlobalTensor 独立设置），粒度更细。但 NVIDIA 的 API 支持更丰富的策略（如 hitRatio 百分比控制、持久化缓存预留比例），昇腾目前是二元选择（进入/绕过）。**Kernel Launch 中的 `l2ctrl` 参数**：

Ascend C 核函数启动符 `>` 中包含一个 `l2ctrl` 参数，用于 L2 Cache 控制。但根据 CANN 8.5 官方文档，该参数目前为保留参数，暂时设置为固定值 `nullptr`**：

`// 当前 l2ctrl 为保留参数，传 nullptr
kernel_name>(argument_list);`

这意味着 L2 Cache 的高层控制策略（如全局切分策略）目前主要通过 Tiling 切分 + SetL2CacheHint** 组合实现，而非通过 launch 参数。`l2ctrl` 参数的存在暗示华为未来可能开放更多 L2 Cache 控制能力。

<strong>参考</strong>：昇腾官方文档 - 存储单元、L2 Cache 切分最佳实践、设置合理的 L2 CacheMode
#### L2 Cache 对比总表

维度NVIDIA H100 (Hopper)昇腾 Ascend950 (arch35)L2 容量50 MB（官方确认）未官方公开（文档假设 192 MB，可信度中等）L2 带宽~5.5 TB/s (near) / ~3.8 TB/s (跨分区)~7 TB/s (读写混合)管理方式硬件全自动，对开发者透明硬件自动缓存，开发者可通过 Tiling 切分 + CacheMode 优化Cacheline128 字节128 字节（arch35，较前代 512 字节优化）分区设计Near/Far 双分区，跨分区延迟高未公开分区信息亲和性控制 APIcudaAccessPolicyWindow (Stream 级别)SetL2CacheHint (Tensor 级别)控制粒度连续内存区域 + hitRatio 百分比逐 Tensor 二元选择（进入/绕过）控制策略Persisting / Streaming / Normal 三态CACHE_MODE_NORMAL / CACHE_MODE_DISABLE 二态设计哲学透明加速为主，高级用户可微调数据搬运默认受益，鼓励开发者主动优化<strong>💡 关键洞察</strong>：两者都支持开发者显式控制 L2 Cache 亲和性，但设计理念不同：** 

- NVIDIA**：L2 Cache 默认全自动，开发者通过 `cudaAccessPolicyWindow` 在 Stream 级别”提示”哪些数据应持久化驻留，支持 hitRatio 精细调控，是<strong>锦上添花</strong>的优化手段。
- <strong>昇腾</strong>：L2 Cache 同样默认自动缓存，但开发者被<strong>强烈建议</strong>通过 `SetL2CacheHint` 将只读一次的冷数据标记为 `CACHE_MODE_DISABLE` 以避免污染 L2，配合 Tiling 切分确保热数据在 L2 中驻留。这更像是<strong>性能必修课</strong>而非可选优化。
**

#### 4.3 数据流模型根本差异

NVIDIA：隐式数据流** — 代码中直接访问全局内存指针，硬件自动完成 L2 → L1 缓存，开发者只需关注线程索引和计算逻辑。

<strong>昇腾：显式数据流</strong> — 开发者手动调用 `DataCopy` 完成三阶段搬运：

- GM → [L2 自动缓存] → UB（MTE2 异步 DMA）
- UB 上计算（Vector/Cube 指令）
- UB → [L2 自动缓存] → GM（MTE3 异步 DMA）
<strong>⚠️ 关键差异</strong>：NVIDIA 的 shared memory 是<strong>可选优化</strong>（不用也能跑），昇腾的 UB 搬运是<strong>必须的</strong>（不搬数据到 UB 就无法利用 Vector/Cube 加速）。但两者的 L2 Cache 都是自动工作的——NVIDIA 的整个缓存层次对开发者透明，昇腾的 L2 虽自动，但 UB（类似 Shared Memory 的角色）需要显式管理。
#### 5. 编程模型与并行模型对比

#### 5.1 NVIDIA CUDA：SIMT 模型

**

![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_ab4fa2fe50a6.jpg)

#### 5.2 昇腾 Ascend C：SPMD + SIMD/SIMT 双模型

![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_5cecca26fd45.jpg)

> SIMD vs SIMT 关键区别<strong>：</strong> 

- SIMD**：一条指令操作一个向量缓冲区，开发者需显式管理向量宽度、对齐、Tail 处理。
- <strong>SIMT</strong>：一条指令由多个独立线程执行，开发者像写标量代码，硬件自动并行化。
**

#### 5.3 编程模型对比表

维度CUDA (SIMT)Ascend C SIMD（传统）Ascend C SIMT（950 新增）并行粒度线程级（数万线程）核级 + 核内 SIMD 向量核级 + 核内线程级核内计算模型每线程处理标量每指令处理向量每线程处理标量任务分配Warp Scheduler 自动调度Host 侧 Tiling 预计算Host Tiling + 核内线程分配数据搬运隐式（硬件缓存）显式（MTE2/MTE3 DMA）显式（仍需 DMA）同步机制__syncthreads()EnQue() / DeQue()Simt::ThreadBarrier()片上存储Shared Memory（可选优化）UB（必须使用）UB（必须使用）适用场景通用规则向量运算、高性能路径不规则运算、CUDA 迁移
#### 5.4 Ascend950 SIMT 编程示例

SIMT 硬件实现细节**（来源：CANN Meetup 官方分享）：

950 的 AIV 新增了以下 SIMT 专有硬件组件：

- <strong>4 个 Warp Scheduler</strong>：scheduler_id = warp_id % 4，多线程调度
- <strong>Divergence Stack</strong>：支持分支调度（类似 NVIDIA 的分支处理机制）
- <strong>SIMT Register File</strong>：SIMT 专用寄存器堆，线程数与每线程寄存器数的权衡关系：
最大线程数每线程寄存器数20481610243251264

- <strong>DCache</strong>：最大 128KB，直接复用 UB 作为 Cacheline，SIMT 模式下可通过 DCache 直接读写 GM
- <strong>SIMD/SIMT 共享组件</strong>：ICache（指令缓存）、ALU（计算单元）、UB（SIMT 当 Shared Memory / SIMD 直接操作）、GSU（Gather Scatter Unit）
<strong>⚠️ 性能权衡</strong>：SIMD 模式下 UB 访存效率是 SIMT 模式的 <strong>4 倍</strong>（SIMD: 4×x B/s vs SIMT: x B/s），因此规则向量运算仍建议用 SIMD。`// Ascend950 独有：SIMT 编程（类 CUDA 体验）
__simt_vf__ __aicore__ LAUNCH_BOUND(512)
inline void SimtKernel(/* params */) {

```text
    int64_t blockIdx  = Simt::GetBlockIdx();    // 类似 CUDA blockIdx.x
    int64_t threadIdx = Simt::GetThreadIdx();   // 类似 CUDA threadIdx.x
    int64_t threadNum = Simt::GetThreadNum();   // 类似 CUDA blockDim.x
    int64_t globalIdx = blockIdx * threadNum + threadIdx;
    // 每个线程处理自己的数据 ...
}

// 启动：Simt::VF_CALL(Simt::Dim3{numThreads}, ...);
// 同步：Simt::ThreadBarrier();   // 类似 __syncthreads()
// 原子：Simt::AtomicAdd(&val, 1); // 类似 atomicAdd()`
```


CUDA APIAscend950 SIMT API说明threadIdx.xSimt::GetThreadIdx()线程索引blockIdx.xSimt::GetBlockIdx()块索引blockDim.xSimt::GetThreadNum()线程数__syncthreads()Simt::ThreadBarrier()线程同步atomicAdd()Simt::AtomicAdd()原子操作kernel>>()Simt::VF_CALL(Dim3{T})启动<strong>💡 开发策略</strong>：规则向量运算（Softmax、LayerNorm）用 <strong>SIMD</strong> 获最佳性能；不规则操作或 CUDA 迁移用 <strong>SIMT</strong> 降成本。两种模型可在同一算子中<strong>混合使用</strong>。<strong>参考</strong>：CANN Skills - NPU Arch Guide, arch35 SIMT 编程
#### 6. 代码实战：向量加法 (Vector Add)

这是最经典的并行编程入门示例。让我们看看两个平台上实现的差异。

#### 6.1 CUDA 实现

`// ===== CUDA Vector Add =====

```cpp
// 文件: vector_add.cu

#include 
#include 

// Kernel 函数：每个线程处理一个元素
```

__global__ void vectorAdd(const float *x, const float *y, 

```cpp
                          float *z, int n) {
    // 计算全局线程索引
    int idx = blockIdx.x * blockDim.x + threadIdx.x;
    int stride = blockDim.x * gridDim.x;

    // Grid-stride loop：一个线程可处理多个元素
    for (int i = idx; i >>(x, y, z, N);

    // 4. 等待完成
    cudaDeviceSynchronize();

    // 5. 释放内存
    cudaFree(x); cudaFree(y); cudaFree(z);
    return 0;
```

}`

<strong>CUDA 代码特点</strong>：

- 代码简洁，核心逻辑仅 3 行
- 通过 `threadIdx` / `blockIdx` 自动分配工作
- 数据搬运由硬件自动完成
- `cudaMallocManaged` 统一内存进一步简化

#### 6.2 Ascend C 实现

`// ===== Ascend C Vector Add =====

```cpp
// 文件: vector_add.cpp

#include "kernel_operator.h"

using namespace AscendC;

// 每个 AI Core 上执行的 Kernel
class VectorAddKernel {
public:
    __aicore__ inline VectorAddKernel() {}

    __aicore__ inline void Init(GM_ADDR x, GM_ADDR y, GM_ADDR z,
                                 uint32_t totalSize, uint32_t tileSize) {
        // 获取当前 AI Core 的工作范围
        uint32_t coreId = GetBlockIdx();
        uint32_t coreNum = GetBlockNum();
        uint32_t perCoreSize = totalSize / coreNum;
        uint32_t offset = coreId * perCoreSize;

        // 设置 Global Memory 指针
        xGm.SetGlobalBuffer((__gm__ float *)x + offset, perCoreSize);
        yGm.SetGlobalBuffer((__gm__ float *)y + offset, perCoreSize);
        zGm.SetGlobalBuffer((__gm__ float *)z + offset, perCoreSize);

        this->tileSize = tileSize;
        this->tileNum = perCoreSize / tileSize;

        // 初始化队列 (Double Buffer, depth=2)
        pipe.InitBuffer(inQueueX, 2, tileSize * sizeof(float));
        pipe.InitBuffer(inQueueY, 2, tileSize * sizeof(float));
        pipe.InitBuffer(outQueueZ, 2, tileSize * sizeof(float));
    }

    __aicore__ inline void Process() {
        for (uint32_t i = 0; i  xLocal = inQueueX.AllocTensor();
        LocalTensor yLocal = inQueueY.AllocTensor();

        // 异步 DMA：GM → UB
        DataCopy(xLocal, xGm[tileIdx * tileSize], tileSize);
        DataCopy(yLocal, yGm[tileIdx * tileSize], tileSize);

        // 标记数据就绪（同步点）
        inQueueX.EnQue(xLocal);
        inQueueY.EnQue(yLocal);
    }

    // ===== Stage 2: Compute (Vector 计算) =====
    __aicore__ inline void Compute(uint32_t tileIdx) {
        // 等待 MTE2 搬运完成（阻塞）
        LocalTensor xLocal = inQueueX.DeQue();
        LocalTensor yLocal = inQueueY.DeQue();
        LocalTensor zLocal = outQueueZ.AllocTensor();

        // Vector 指令：逐元素加法
        Add(zLocal, xLocal, yLocal, tileSize);

        // 标记结果就绪
        outQueueZ.EnQue(zLocal);
        inQueueX.FreeTensor(xLocal);
        inQueueY.FreeTensor(yLocal);
    }

    // ===== Stage 3: CopyOut (MTE3 搬出) =====
    __aicore__ inline void CopyOut(uint32_t tileIdx) {
        // 等待 Vector 计算完成（阻塞）
        LocalTensor zLocal = outQueueZ.DeQue();

        // 异步 DMA：UB → GM
        DataCopy(zGm[tileIdx * tileSize], zLocal, tileSize);

        outQueueZ.FreeTensor(zLocal);
    }

private:
    TPipe pipe;
    TQue inQueueX, inQueueY;
    TQue outQueueZ;
    GlobalTensor xGm, yGm, zGm;
    uint32_t tileSize;
    uint32_t tileNum;
};

// Kernel 入口
```

extern "C" __global__ __aicore__ void vector_add_kernel(
    GM_ADDR x, GM_ADDR y, GM_ADDR z,

```text
    uint32_t totalSize, uint32_t tileSize) {
    VectorAddKernel op;
    op.Init(x, y, z, totalSize, tileSize);
    op.Process();
```

}`

<strong>Ascend C 代码特点</strong>：

- 显式三段式流水线（CopyIn → Compute → CopyOut）
- 手动管理 UB 缓冲区（TQue, Double Buffer）
- 显式数据搬运（DataCopy）
- 队列同步（EnQue/DeQue）
- Host 侧需要预计算 Tiling 参数

#### 6.3 代码差异小结

- <strong>CUDA</strong>：~10 行 Kernel，标量线程模型，数据搬运由硬件隐式完成
- <strong>Ascend C</strong>：~60 行 Kernel，显式三段式流水线（CopyIn → Compute → CopyOut），体现了[第 4.3 节](https://zhuanlan.zhihu.com/p/2020921487947736363/edit#43-%E6%95%B0%E6%8D%AE%E6%B5%81%E6%A8%A1%E5%9E%8B%E6%A0%B9%E6%9C%AC%E5%B7%AE%E5%BC%82)描述的两种数据流模型差异

#### 6.4 执行流水线时序对比

**

![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_626ba4bcfa8e.jpg)

#### 7. 代码实战：矩阵乘法思路对比

矩阵乘法最能体现两种架构的差异。

#### 7.1 CUDA 矩阵乘法（使用 Tensor Core）

`// CUDA 矩阵乘法 - Tensor Core 版本 (WMMA API)

```cpp
#include 
using namespace nvcuda;
```


__global__ void matmul_tensor_core(half *A, half *B, float *C,

```cpp
                                    int M, int N, int K) {
    // 声明 Tensor Core 的 fragment
    wmma::fragment a_frag;
    wmma::fragment b_frag;
    wmma::fragment c_frag;

    // 初始化累加器
    wmma::fill_fragment(c_frag, 0.0f);

    // 计算当前 Warp 负责的矩阵块（简化示意：假设每个 Block 对应一个 Warp，blockDim.x=32）
    int warpM = blockIdx.x * 16;
    int warpN = blockIdx.y * 16;

    // K 维度循环
    for (int k = 0; k 
```


#### 7.2 Ascend C 矩阵乘法思路

`// Ascend C 矩阵乘法 - Cube Unit 版本 (概念示意)

```cpp
class MatMulKernel {
public:
    __aicore__ inline void Process() {
        for (uint32_t tile = 0; tile  aL1 = l1BufA.Get();
        DataCopy(aL1, aGm[tileOffset], tileSize);
        // L1 → L0A
        LocalTensor aL0 = l0ABuf.Get();
        LoadData(aL0, aL1, loadParams);
    }

    __aicore__ inline void CubeCompute(uint32_t tile) {
        // Cube 指令：矩阵乘加
        // mmad: L0A × L0B → L0C  (矩阵乘加)
        LocalTensor cL0 = l0CBuf.Get();
        Mmad(cL0, aL0Buf, bL0Buf, mmadParams);
    }
```

};`

#### 7.3 矩阵乘法数据流对比

![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_01fa7c11bcba.jpg)

#### 8. Ascend950 独有特性解析

#### 8.1 Regbase 编程（寄存器级操作）

Ascend950 支持直接操作寄存器的编程模式（Regbase 架构），相比上一代的 Membase 架构有三大优势：

- 寄存器内计算**：中间结果无需回写 UB，减少对 Local Buffer 的访问带宽需求
- <strong>OOO 指令双发</strong>：通过支持乱序执行（Out-of-Order）实现指令双发，提升 Vector 性能
- <strong>非对齐友好</strong>：便于支持 Local Buffer 非 32B 对齐数据处理
`// Regbase 编程：直接操作寄存器（仅 arch35）

```text
// 相比 Membase 编程方式，处理的数据由 block/repeat 参数
// 换成 for-loop 形式，代码更容易编写和理解

// Ascend C 类库 API 风格
```

AscendC::Reg::RegTensor vDstReg0;
AscendC::Reg::RegTensor vSrcReg0, vSrcReg1;
AscendC::Reg::MaskReg maskReg;

```cpp
for (uint16_t i = 0; i (calCount);
    AscendC::Reg::Load(vSrcReg0, src0Ptr + i * oneRepeatSize);
    AscendC::Reg::Load(vSrcReg1, src1Ptr + i * oneRepeatSize);
    AscendC::Reg::Add(vDstReg0, vSrcReg0, vSrcReg1, maskReg);
    AscendC::Reg::Store(dstPtr + i * oneRepeatSize, vDstReg0, maskReg);
```

}`

<strong>适用场景</strong>：量化/反量化算子、动态量化、需要极致性能的热点路径

#### 8.2 FP8/MxFP4 低精度支持

特性NVIDIA H100 (Hopper)Ascend950 (arch35)FP8 E5M2（训练梯度）✅ Tensor Core 原生✅ Cube/Vector 支持FP8 E4M3（推理激活）✅ Tensor Core 原生✅ Cube/Vector 支持自定义 FP8❌✅ HiFloat8 hifloat8_t（华为自定义锥形精度格式，38 阶码值接近 FP16）MxFP4（4-bit 微缩浮点）✅ (Blackwell 新增，Hopper 不支持)✅ MxFP4(E2M1/E1M2)MXFP8✅✅ MXFP8(E4M3/E5M2)混合精度FP8 计算 + FP32 累加FP8 计算 + FP32 累加编程接口cuDNN / WMMA / MMAAscend C 内建类型 fp8_e5m2_t / fp8_e4m3fn_t`// FP8 条件编译示例
if constexpr (IsSameType::value) {
    // FP8 E5M2 处理路径
} else if constexpr (IsSameType::value) {
    // FP8 E4M3FN 处理路径
} else if constexpr (IsSameType::value) {
    // HiFloat8 处理路径（华为自定义）
}`

<strong>HiFloat8 格式技术细节</strong>（来源：CANN Meetup 官方分享）：

HiFloat8 不是简单的固定阶码/尾数分配，而是采用<strong>变长前缀编码的锥形精度</strong>设计：

- 利用点位域（Dot）变长前缀码指示阶码存储位宽，实现”数值靠近 1 时精度高，远离 1 时精度逐渐降低”的锥形分布
- 4 个精度区间：高精度区（E=±[0,3]，4-bit 有效位）、中精度区（E=±[4,7]，3-bit）、低精度区（E=±[8,15]，2-bit）、极小值区（E=[-22,-16]，1-bit）
- 综合阶码范围达到 <strong>[-22, 15] 共 38 个阶码值</strong>，接近 FP16 的 40 个，远超 E4M3 的 18 个和 E5M2 的 32 个
- 阶码采用原码编码并隐藏 1-bit 固定值不存储，实现无冗余编码
- 得益于大动态范围，Float16/BFloat16 数据可<strong>直接转换</strong>为 HiF8（Direct Convert），精度损失也相对较小
<strong>💡 实战意义</strong>：业界普遍认为 E5M2 精度过低（如 DeepSeek V3 训练只用 E4M3），而 E4M3 仅 18 个二进制指数，需要极端细粒度 Scaling 保精度。HiFloat8 的 38 阶码值使其可以用<strong>更粗粒度的 Scaling</strong>达到同等或更好的精度，降低 Scaling 开销。
#### 8.3 arch35 代码目录结构

`operator/
├── op_kernel/
│   ├── *.cpp / *.h          # 通用实现（所有架构）
│   ├── arch32/              # 910B/310P 系列优化
│   │   └── *_dag.h
│   └── arch35/              # ← Ascend950 专用优化
│       ├── *_dag.h          # 950 优化的 DAG 定义
│       ├── *_simt.h         # 950 SIMT 并行实现
│       ├── *_regbase.h      # 950 Regbase 实现
│       └── *_struct.h       # 950 模板参数声明
├── op_host/
│   ├── *tiling*.cpp         # 通用 Tiling
│   └── arch35/              # 950 专用 Tiling
│       └── *_tiling_arch35.cpp
└── CMakeLists.txt`

#### 9. 性能优化哲学差异

#### NVIDIA 优化策略：”隐藏延迟”

`核心思路：用足够多的线程来隐藏访存延迟

优化手段：
1. 提高 Occupancy（SM_90 利用率）
   - 减少每线程寄存器使用
   - 合理设置 Block Size
   
2. 内存合并访问（Coalesced Access）
   - 相邻线程访问相邻内存地址
   
3. Shared Memory 优化
   - 减少 Global Memory 访问
   - Bank Conflict 避免
   
4. Warp 级优化
   - 避免 Warp Divergence（分支发散）
   - 使用 Warp Shuffle 指令

5. Tensor Core 利用
   - WMMA/MMA API 访问 Tensor Core`

#### 昇腾优化策略：”榨干带宽”

`核心思路：让搬运和计算完全重叠，充分利用每个时钟周期

优化手段：
1. Double Buffer 流水线
   - MTE2/Vector/MTE3 三级并行
   - depth=2 搬运与计算重叠
   
2. Tiling 策略优化
   - 最大化单次搬运量（减少搬运次数）
   - UB 空间精确规划
   - SWAT (Sliding Window Adaptive Tiling)：最大化多核 L2 命中率
   - StreamK：保持最优基本块的同时实现多核负载均衡
   
3. 数据对齐
   - 32 字节对齐（硬件要求）
   - DataCopyPad 处理非对齐数据
   - 128B Sector Cache 持续优化离散/小包访问
   
4. 核间负载均衡
   - Host 侧均匀分配任务
   - 动态核数适配
   
5. 架构特定优化 (arch35)
   - Regbase 编程（OOO 指令双发，寄存器内计算）
   - SIMT 编程（细粒度并行，离散访问友好）
   - CV 融合通路（L0C → UB 直通，DualDst 双目标）
   - 利用更大的 UB (248KB vs 192KB) 和翻倍的 L0C Buffer
   - 数据常驻优化（如 FIA 算子中 Query 常驻 + Key 小常驻）`

#### 10. 硬件参数横向对比表

参数NVIDIA H100 (Hopper)华为 Ascend950PR (Atlas 350)华为 Ascend950DT制程TSMC 4N7nm (推测)7nm (推测)晶体管数800 亿未公开未公开核心数132 SM32 AI Core（2× 计算 DIE × 16，CANN Meetup 确认）32 AI CoreFP8 算力~2 PFLOPS- PFLOPS- PFLOPSMxFP4 算力—1.56 PFLOPS- PFLOPS矩阵加速4 Tensor Core/SMCube Unit/CoreCube Unit/Core片上缓存/核256 KB L1/SMEM（SMEM 最高 228 KB）248 KB UB248 KB UBL2 Cache50 MB（双分区设计，带宽 ~5.5 TB/s）未官方公开（文档假设 192 MB，带宽 ~7 TB/s）未官方公开（文档假设 192 MB，带宽 ~7 TB/s）HBM 容量80 GB HBM3112 GB (HiBL 1.0)144 GB (HiZQ 2.0)HBM 带宽3.35 TB/s1.4 TB/s (标卡) / 1.6 TB/s (模组)4 TB/s互联带宽NVLink 900 GB/s—2 TB/s功耗700W (SXM5)600W未公开FP8 支持✅ E4M3 + E5M2✅ E4M3 + E5M2 + HiFloat8✅ E4M3 + E5M2 + HiFloat8MxFP4❌ (Hopper 不支持)✅ MxFP4✅ MxFP4编程语言CUDA C++Ascend C (C++扩展)Ascend C (C++扩展)编程模型SIMTSPMD + SIMD/SIMT 双模型SPMD + SIMD/SIMT 双模型访存颗粒度—128 字节（从 512 字节优化）未公开<strong>⚠️ 注</strong>：32 AI Core 数量来源于 CANN Meetup 官方分享（每计算 DIE 16 AI Core × 2 计算 DIE），Skills 仓库默认参数显示 64 可能包含 AIC+AIV 双子核心计数。上述加粗参数均来自华为全联接大会 2025（HC2025）及 2026 年 3 月华为中国合作伙伴大会官方发布。
#### 11. 总结与展望

#### 两种架构的适用场景

场景更适合 NVIDIA SM_90更适合昇腾 AI Core通用并行计算 (GPGPU)生态成熟，CUDA 无可替代主要面向 AI 场景矩阵运算密集型Tensor Core 强大Cube Unit 高效向量运算CUDA Core 灵活Vector Unit 专用高度优化的 AI 算子优化空间大显式控制上限更高快速原型开发代码简洁，调试方便学习曲线较陡LLM 推理成熟方案多950DT/PR 专用优化国产化要求受出口管制自主可控
#### 设计哲学总结

**

![](/images/collections/0.raw/zhihu/%E4%BD%93%E7%B3%BB%E7%BB%93%E6%9E%84/asset/img_d7dc4d006f08.jpg)

#### 展望

随着 Ascend950 引入 SIMD/SIMT 双编程模型<strong>和 Regbase 编程，华为正在</strong>融合两种范式的优势**：

- <strong>保留</strong> SIMD 显式数据流控制带来的高性能上限（专家级优化路径）
- <strong>引入</strong> SIMT 类 CUDA 的线程级并行降低开发门槛（CUDA 算子快速迁移路径）
- <strong>物理分离</strong> AIC/AIV 双子单元 + Fixpipe 后处理，让矩阵和向量路径互不干扰
- <strong>扩展</strong> FP8/MxFP4 低精度格式支持 LLM 场景
两种架构的竞争，本质上是 <strong>“易用性”</strong> 与 <strong>“极致性能”</strong> 的权衡博弈，也是 <strong>“软件生态”</strong> 与 <strong>“硬件创新”</strong> 的长期赛跑。

#### 12. 参考资料

#### NVIDIA 官方资料

- NVIDIA Hopper Architecture In-Depth - H100 架构深度解析
- An Even Easier Introduction to CUDA - CUDA 编程入门
- NVIDIA RTX Blackwell GPU Architecture - Blackwell 架构白皮书
- GPU Glossary - Streaming Multiprocessor - SM 架构术语

#### 华为昇腾官方资料

- 昇腾社区 - Ascend C 算子编程 - Ascend C 官方主页
- AI Core 基本架构 - 官方文档 - AI Core 硬件架构详解
- Ascend C 教程文档 - 最佳实践与原理详解
- CANN Skills 仓库 - Agent 技能模块，含 arch35 详细文档

#### CANN Meetup 官方技术分享（2026年3月 Ascend 950 专题）

- 面向新一代硬件，CANN技术架构的变与不变（刘锡明/顾宝成/陈仙萍）— 950 芯片架构全景、4Die Chiplet、微架构框图、SIMT/SIMD/Regbase、CCU
- 场景驱动下的算子编程语言选型 — SIMT vs SIMD 适用场景对比
- 探索 Ascend 950 的性能天花板（沈敏/俞郑中等）— Matmul/RmsNormQuant/FIA 极致优化、SWAT Tiling、CV 融合通路
- HiFloat8 数据格式及其训推应用（罗元勇/刘波等）— HiF8 变长前缀编码原理、锥形精度、Scaling 建议、量化算法
- 基于下一代 Ascend 平台的 Ascend C 算子编程概述 — 下一代硬件架构概述、SIMT 4 个 Warp Scheduler、DCache 128KB、线程/寄存器权衡
- 基于下一代硬件的 Cube 编程 — L0C→UB 新通路、UB→L1 新通路、DualDst 模式、CV 融合通路编程
- HCCL 集合通信专用引擎 CCU 技术介绍 — CCU 硬件加速集合通信

#### 社区对比分析

- AscendC vs CUDA - hipudding’s Blog - 编程模型对比
- 昇腾 AI 生态组件全解析：与英伟达生态的深度对比 - CSDN
- NVIDIA GPU 流式多处理器详解 - CSDN
<strong>本文基于公开的官方文档、技术博客和开源代码仓库整理而成。部分 Ascend950 硬件参数尚未公开，标注为”未公开”。如有错误或遗漏，欢迎指正。</strong><strong>最后更新</strong> 2026 年 3 月
