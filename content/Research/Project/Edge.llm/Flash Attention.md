先看这样一张图

![[file-20260715163618035.png]]

随着输入矩阵尺寸变大，吞吐量并没有相应地提高，why？

这篇笔记的主线是：先理解 GPU 为什么快、又为什么会慢；再总结几类通用加速技巧；最后回到 Flash Attention，看它如何把这些技巧组合起来，减少 HBM 读写并提高 attention 的实际吞吐。

![[file-20260715163746856.png]]

# GPU Model

曾经提高计算的方式：提高 CPU 的主频；现在更重要的是 Parallel Scaling：通过高度并行化，让更多处理单元同时处理数据。

理解 Flash Attention 之前，需要先理解 GPU 的基本执行模型：GPU 并不是让单个线程跑得极快，而是让大量线程同时推进，从而获得高吞吐。

![[file-20260715164458773.png]]

（同时 tensor core和低精度数据格式提高了浮点数的运算）

![[file-20260715164635105.png]]

CPU 更关注怎么高效地串行处理数据；GPU 关注的则是提高并行度和总吞吐量。也就是说，GPU 性能好不好，不只取决于算力峰值，还取决于程序能不能提供足够多、足够规整的并行工作。

## GPU Inner Structure

![[file-20260715165804745.png]]

SM 是 GPU 中的基本执行单元，能够独立调度并处理计算任务。后面提到的 block、warp、shared memory，基本都围绕 SM 展开。

### Memory

![[file-20260715165906902.png|300]]

L1的速度很快，但是容量小，Global memory 容量大，访问时间长，通常是片外的，L1位于SM内，L2也在片上，但是相对于L1会离计算单元更远些。

![[file-20260715170128959.png]]

## GPU编程模型

**Thread**：最小的执行单元，遵循 SIMT（Single Instruction, Multiple Thread）模型，即多个线程执行相同的指令，但操作不同的数据

**Block（Thread Block）**：编程层面的概念。一组线程的**逻辑分组**，被映射到同一个 SM 上运行。同一 Block 内的线程可以通过 Shared Memory 协作通信、通过 `__syncthreads()` 同步

**Warp**：硬件层面的概念。GPU 真正的**调度与执行单元**，一个 Warp 固定包含 **32 个线程**，这些线程在硬件上**同步执行相同的指令**（SIMT 的物理实现）。当一个 Block 被分配到 SM 后，会被切分为多个 Warp 由 Warp Scheduler 轮转调度

> **区分**：Block 是逻辑分组（由程序员定义），Warp 是硬件执行粒度（由硬件固定为 32 线程）。一个 Block 在 SM 上会被拆成 ⌈BlockSize/32⌉ 个 Warp 来执行

## GPU内存模型

![[file-20260715170951682.png]]

Register 很快，是每个 thread 私有的本地寄存器；Shared Memory 位于 SM 内，主要用于同一个 block 内线程之间的协作和数据复用；Global Memory 位于显存/HBM，容量大但延迟高，所有 block 都可以访问，但不能把它理解成专门用于“块与块之间通信”的机制。

![[file-20260715221102100.png]]

加速计算的一个motivation就是减少对HBM的访问量
## GPUvsTPU

![[file-20260715171631809.png]]

从概念上看，GPU 和 TPU 都是在用大量并行计算单元服务矩阵乘法，只是 TPU 更专门面向矩阵/张量计算；GPU 则更通用，但也通过 Tensor Core 等单元强化了矩阵乘法能力。

# Basic Trick to Accelerate

前面说明了 GPU 的硬件基础：大量并行线程 + 分层内存。接下来关心的问题是：程序如何写，才能真正把这些硬件资源用起来？下面这些技巧本质上都围绕两个目标：**减少慢速内存访问**，以及 **提高并行单元利用率**。

![[file-20260715163618035.png]]

## Roofline Model

![[file-20260715173604858.png]]
  
首先看懂图上的横纵坐标（注意它们通常是**对数坐标轴**）：

- **横坐标（Operational Intensity，计算强度 / 访存比）：** 单位是 `flops/byte`。意思是**每从内存里读写 1 字节的数据，硬件需要做多少次浮点运算**。
    - 这个值取决于**算法本身**。比如矩阵乘法（Dense Matrix Multiply），数据复用率极高，算力要求大，横坐标就很靠右；而稀疏矩阵乘法（Sparse Matrix Multiply），到处找零散数据，访存多计算少，横坐标就很靠左。
- **纵坐标（Throughput，吞吐量）：** 单位是 `gflops`。代表硬件实际或者理论能达到的**计算速度**。

图中的折线就像一个房顶：
- **斜坡部分（Memory Bounded / 访存受限区）：**
    - **为什么是斜的？** 因为在这一段，限制你速度的不是计算单元（ALU），而是内存带宽（Bandwidth）。
    - 斜率的物理意义就是**内存带宽**（带宽 = 吞吐量 / 计算强度）。图里画了多条斜线（如 CPU main memory, GPU main memory, GPU shared memory），因为越靠近核心的存储介质带宽越高，斜线就越陡。
- **水平部分（Compute Bounded / 计算受限区）：**
    - **为什么是平的？** 因为此时计算强度足够大，内存搬运数据的速度已经完全喂饱了算力核心。这时候限制你的是芯片的**理论算力峰值**（如 GPU/CPU ALU throughput），就算算法复用性再高，硬件的计算单元也已经满载了，无法再高。
线条是硬件在该条件下能达到的最优秀的performance，而图上的几个点表示的则是实际的算法需求

## Control Divergence

控制分歧

![[file-20260715180255315.png]]

控制分歧主要发生在**同一个 warp 内部**：warp 中 32 个线程本来要执行同一条指令，如果它们在 `if/else` 上走了不同分支，硬件会用 mask 先执行一部分线程的分支，再执行另一部分线程的分支。这样虽然逻辑上仍是并行程序，但实际会被串行化，导致部分 lane 空闲。不同 warp 之间走不同分支通常问题没这么大，因为 warp 本来就是独立调度的。

## Low Precision Computation

除了减少无效控制流，还可以从数据表示本身入手：如果每个数占用的 bit 更少，搬运更快；如果硬件对低精度矩阵乘法有专门加速，计算也会更快。

 ![[file-20260715182346061.png]]

数据表示格式的精度在降低
==If you have fewer bits,you have fewer bits to move==

不仅要降低精度，更需要明白哪些操作需要用哪种数值格式
  ![[file-20260715182811693.png]]

这张图说明：低精度不是简单地“所有地方都用更少 bit”，而是现代 GPU 会使用**混合精度**（mixed precision）来加速矩阵乘法，同时尽量保留关键位置的数值稳定性。

- **Tensor Core 的典型计算方式**：输入矩阵元素可以用 `FP16` / `BF16` 这类 16-bit 格式存储和读取，乘法阶段使用低精度输入，因此数据搬运量更小、Tensor Core 吞吐量更高；但多个乘积累加时通常使用 `FP32 accumulator`，最后输出也可以保持或转换为 `FP32`。
- **适合 16-bit 存储/计算的操作**：
    - 矩阵乘法：例如 attention 中的 `QK^T` 和 `PV`，主要是大量乘加，Tensor Core 能高效处理。
    - 大多数逐元素操作：如 `relu`、`tanh`、`add`、`sub`、`mul`，通常对精度要求相对没那么敏感。
- **需要更高精度的操作（FP32/FP16）**：
    - 当把很多小数累加到一个大数上时，低精度容易产生舍入误差，所以==累加、归约==类操作更适合用 FP32。
    - 例如 `sum`、`softmax`、normalization 等 reduction 操作。Flash Attention 里 softmax 的分块归一化和累加就需要特别注意数值稳定性。
- **需要更大动态范围的操作（FP32/BF16）**：
    - `exp`、`log`、`pow` 这类函数可能导致输出范围远大于输入范围，如果格式动态范围太小，容易 overflow / underflow。
    - loss function 也常常需要更高精度或更大动态范围，否则训练信号可能不稳定。

总结：低精度能加速的原因有两个：**搬运的数据更少**，并且 **Tensor Core 对低精度矩阵乘法有更高吞吐量**；但为了避免数值误差，通常采用“低精度输入 + 高精度累加 / 关键操作保留高精度”的混合精度策略。

### MXFP8 与 Scaling Factor

![[file-20260715195615479.png|350]]

**MXFP8**（Microscaling FP8）可以理解为“带局部缩放因子的 FP8”。普通 FP8 是每个数自己用 8 bit 表示；而 MXFP8 会把一小块连续元素作为一个 block，通常是 **32 个 FP8 元素共享一个 scaling factor**。因此它不是单纯的 FP8，而是：

```text
MXFP8 block = 1 个 scaling factor + 32 个 FP8 element
```

常见的 MXFP8 element 仍然是 FP8 的两种格式：

- `E4M3`：指数 4 bit，尾数 3 bit，精度更高一些，但动态范围较小；
- `E5M2`：指数 5 bit，尾数 2 bit，动态范围更大，但尾数精度更低。

MX 格式中的 scaling factor 通常使用 **E8M0** 表示。`E8M0` 只有指数、没有尾数，本质上表示一个 2 的幂次缩放：

```text
scale = 2^e
```

所以一个 MXFP8 block 中第 `i` 个真实数值大致可以理解为：

```text
real_value_i = scale_block × fp8_value_i
```

这里的 `scale_block` 是这个 block 共享的 scaling factor，`fp8_value_i` 是该元素用 FP8 存下来的局部值。

为什么需要 scaling factor？

- **扩大动态范围**：FP8 本身 bit 数少，能表示的范围有限。通过每 32 个元素共享一个缩放因子，可以让这一小块数据整体平移到更合适的数值范围内。
- **降低量化误差**：如果一个 tensor 只使用全局 scale，那么局部小数值可能会被大数值“挤压”到很粗糙的量化级别；MXFP8 使用 per-block scaling，使每个小块都能根据自己的最大值或分布选择 scale，误差通常更小。
- **硬件友好**：E8M0 的 scale 是 2 的幂，乘以 scaling factor 在硬件上可以近似看成指数调整，而不是普通浮点乘法，因此更适合 Tensor Core / 矩阵乘法流水线。

**一个严重的问题是，在该数值格式下，求一个矩阵的转置非常的复杂**，可能需要重新做一次量化，所以在使用这种数值格式的时候，会为每个矩阵生成两个scale factor矩阵，一个是scaling factor，另一个是转置后的scaling factor

![[file-20260715195932037.png]]

这张图展示 MXFP8 在训练中的实际用法：**不是所有算子都量化**，而是只把 Q/K/V、Projection、FC1/FC2 这类矩阵乘法层临时量化为 MXFP8，用 Tensor Core 加速；LayerNorm、Softmax、Add、activation、optimizer update 等更敏感的部分仍保留 BF16/FP32。

“只对能够安全量化的层进行量化”指的是：只量化误差相对可控、收益大的 GEMM/BMM/Linear 层，避免量化 softmax、归约、归一化、loss 等容易受数值误差影响的操作。

训练中通常是：

```text
BF16 weight / activation / gradient
→ quantize / transpose & quantize 成 MXFP8
→ FPROP / DGRAD / WGRAD 矩阵乘法
→ 输出 BF16 或 FP32 给下一层 / optimizer
```

这里不一定会把 MXFP8 显式解量化成完整 BF16 tensor 再计算；更准确地说，MXFP8 数值和 scaling factor 在矩阵乘法 kernel / Tensor Core 内部一起参与计算。推理时也类似：如果硬件支持 MXFP8 matmul，就可以直接用 `MXFP8 value + scale` 计算；只有遇到不适合低精度的算子时，才输出或转换回 BF16/FP16/FP32。

## Operation Fusion

低精度解决的是“每个数更小、矩阵乘更快”；但如果中间结果仍然频繁写回 HBM，整体还是会被 IO 拖慢。因此下一步是把多个算子融合起来，减少中间数据落到显存。

![[file-20260715201838811.png]]

随着算力提升，很多程序的瓶颈不再是算术运算，而是数据在 memory 与 compute 之间来回搬运。Operation Fusion 的思想是：把多个连续算子合并成一个 kernel，让中间结果尽量留在 register/shared memory 中，而不是每一步都写回 HBM 再读出来。

![[file-20260715201904490.png]]

Naive 做法会让每个小算子都读写一次 memory；fused kernel 则像流水线一样在一次 kernel 中完成多步计算，因此减少 kernel launch overhead 和 HBM 访问。Flash Attention 本质上也大量使用了 fusion：把 matmul、mask、softmax、dropout、再乘 V 等过程尽量融合到一个 IO-aware kernel 中。

可以把算子粗略分成两类：

- **Compute-bound**：主要瓶颈在计算量，例如大的矩阵乘法、多 channel 卷积。这类操作本身有较高计算强度，优化重点通常是使用 Tensor Core、低精度、好的 tiling 和并行调度。
- **Memory-bound**：主要瓶颈在访存，例如按位/逐元素操作、ReLU、Dropout、mask、sum、softmax 等。这类操作每读写一个元素只做很少计算，容易被 HBM 带宽限制。

Fusion 对 **memory-bound** 算子尤其有效：如果 `mask → softmax → dropout` 分别作为独立 kernel 执行，每一步都要把中间结果写回 HBM，再从 HBM 读出来；融合后，中间结果可以尽量留在寄存器或 shared memory 中，直接传给下一步使用。

这也是为什么左图中 PyTorch 的 naive attention 会在 `matmul / mask / softmax / dropout / matmul` 之间花费大量时间，而 Flash Attention 用 fused kernel 后时间大幅下降：它不是减少了 attention 的数学计算量，而是减少了中间矩阵在 HBM 中反复读写。

不过 fusion 在训练中有一个限制：反向传播可能需要前向过程中的中间结果。如果完全不保存这些中间结果，反向时就需要重新计算；这就引出了下一节的 **Recomputation**，也就是用额外计算换取更少的显存和 HBM IO。

## Recomputation

Fusion 是在前向计算中减少中间结果写回；Recomputation 则是在训练中进一步追问：有些中间值真的必须保存吗？如果重新计算比读写显存更便宜，就可以用计算换内存。

![[file-20260715202553383.png]]

反向传播的时候会再次用到激活值

![[file-20260715202643585.png]]

激活函数的激活过程中会产生中间值，中间值在反向传播中还会用到，这样会造成大量的内存读写，所以一个insight就是，假设计算代价十分低，就可以丢弃所有的中间值，在反向传播的时候，在需要的情况下，重新正向计算S2/S1，这样就大大减少了内存的读写，也使得GPU的计算能力能够被充分调用

![[file-20260715203259603.png]]

 **内存访问次数从8—>5**

## Memory Coalescing（内存合并）

![[file-20260715203833902.png]]

DRAM/Global Memory 通常按 burst/transaction 读取一段连续地址，而不是只读单个元素。因此如果一个 warp 中相邻线程访问连续、对齐的地址，硬件可以把这些访问合并成较少的 memory transaction，这就是 coalescing。

如果访问不连续或未对齐，就可能需要多个 transaction，浪费带宽。所以 tiling 时不仅要把数据放进 shared memory，还要尽量让从 global memory 读取 tile 的方式是连续且对齐的。

## Tiling

Coalescing 让一次 global memory 访问更高效；Tiling 则进一步提高数据复用，让同一份数据进入片上存储后被反复使用。

Tiling 的核心是把大矩阵切成小块 tile：先把当前要用的 A/B tile 从 Global Memory 搬到 Shared Memory，再在 SM 内反复复用这些数据计算输出 tile。这样每个输入元素不需要被从 Global Memory 重复读取 N 次，而是在 shared memory 中被多次使用，从而显著降低访存量。输出 tile 通常在寄存器中累加，最后再写回 Global Memory。

![[file-20260715205305200.png]]

![[file-20260715205408693.png]]

### Tiling和内存合并的关系

![[file-20260715205851026.png]]

有的时候会为了加速可能还需要填充数据，使得Tiling和内存里的Burst Section对齐，这就造成了一种可能出现的现象，就是更大的数据集可能比较小的数据集的训练速度更快

## Why GPUs get slow？

到这里可以看到，GPU 性能不是随着问题规模单调上升的。即使用了 tiling 和 coalescing，实际吞吐仍然会受到 tile 大小、SM 数量、block 调度波次等离散因素影响。

![[file-20260715163618035.png]]

这里图里的 **Wave Quantization** 不是数值量化，而是指 GPU 调度上的“波次量化”：GPU 会把计算切成很多 tile / thread block，再分批次（wave）分配到 SM 上执行。如果 block 数量刚好能填满所有 SM，吞吐量高；如果最后一波只剩少量 block，就会有很多 SM 空闲，吞吐量突然下降。

因此随着矩阵尺寸变大，理论上计算强度提高，吞吐量应该上升；但实际曲线会出现锯齿和平台，是因为尺寸变化会改变 tiling 后的 block 数量。某些尺寸下 tile 对齐、SM 利用率高，速度快；某些尺寸下需要 padding 或最后一波不满，速度就会变慢。

简言之：**GPU 慢不一定是算力不够，而可能是矩阵尺寸、tiling 粒度、SM 数量之间没有对齐，导致并行资源没有被填满。**

# Flash Attention

前面的所有内容都可以看作 Flash Attention 的铺垫：attention 的数学形式很简单，但 naive 实现会产生巨大的 `N×N` 中间矩阵，导致 HBM IO 成为瓶颈。Flash Attention 的核心就是把 tiling、fusion、online softmax 和 recomputation 组合起来，让 attention 更符合 GPU 的执行和内存模型。

FlashAtention 加速的原理是最基础和常见的系统性能优化的手段，即通过利用更高速的上层存储计算单元，减少对低速更下层存储器的访问次数，来提升模型的训练性能。

## How Attention Compute？

输入Token向量，生成Q K V矩阵，然后求出S，S按行计算softmax矩阵，softmax矩阵乘V得到注意力输出

![[file-20260715215654371.png]]

标准 attention 可以写成：

```text
S = QK^T
P = softmax(S)
O = PV
```

Naive attention 会按以下几个阶段执行：
1. 先从 HBM 加载 `Q/K` 到 SRAM
2. 计算 `S = QK^T`
3. 再把完整的 `S` 写回 HBM；
4. 之后再从 HBM 读回 `S` 
5. 计算 `P = softmax(S)`
6. 把完整的 `P` 写回 HBM
7. 最后再读回 `P` 和 `V`
8. 计算 `O = PV`
9. 并写回 HBM。

可以总结出，Attention计算过程中主要会面对的三个Kernel为:

![[file-20260716141509288.png]]

这里的核心瓶颈是：`Q/K/V` 的大小是 `N × d`，但 `S` 和 `P` 都是 `N × N`。随着序列长度 `N` 增长，中间矩阵的缓存量按平方级增长。例如 `N = 8192, d = 128` 时，`S/P` 远大于单个 `Q/K/V` 矩阵。

所以 naive attention 慢的关键不是公式复杂，而是它反复把巨大的 `S`、`P` 写入 HBM、再读回 SRAM，造成严重的 HBM IO 瓶颈。Flash Attention 后面要解决的正是这个问题：**不显式 materialize 完整的 `N×N` attention matrix**。

## Tiling

普通矩阵乘法的 tiling 只需要考虑 `A×B`；Flash Attention 的 tiling 更复杂，因为中间夹着 softmax，不能简单地把每个 tile 独立算完。因此它需要和 online softmax 配合。

![[file-20260715211207716.png|200]]

Flash Attention 会把 `Q` 按行块切分，把 `K/V` 按列块切分。每次只把一小块 `Q`、`K`、`V` 搬到 SRAM/shared memory 中，计算当前 tile 的局部 score，并在线更新 softmax 的统计量和输出 `O`。这样可以把大量中间结果留在片上存储中，减少 HBM 读写。

外循环里遍历K和V的Block，把K和V从HBM拷贝到SRAM中

内循环遍历Q的Block，让Q和K、V依次计算，然后把计算结果也通过内循环增量更新到O矩阵里

[分块后的计算](https://www.bilibili.com/video/BV1UT421k7rA?t=403.7)
## Recomputation

[[Flash Attention#Recomputation]]

Flash Attention 训练时通常不会在前向传播中保存完整的 `N×N` attention matrix / softmax matrix，而是只保存必要的归一化统计量（如每行的 max、sum 等）和输出。反向传播需要 attention 概率时，再根据 Q/K/V 的 tile 重新计算局部 score 和 softmax。这样用额外计算换取显著的显存和 HBM IO 减少。

## Softmax的处理

### 朴素的softmax

Softmax 的标准定义：

$$y_i = \frac{e^{x_i}}{\sum_{j=1}^{V} e^{x_j}}$$

朴素实现需要**遍历输入向量两次**：

1. **第一遍**：计算所有 $e^{x_j}$ 并求和，得到分母 $\sum e^{x_j}$——需要读取输入向量（一次读取）。
2. **第二遍**：用每个 $e^{x_i}$ 除以分母，得到输出 $y_i$——需要再次读取输入向量（第二次读取），再将结果写入（一次写入）。

因此每个元素需要 **3 次内存访问**（两次读取 + 一次写入），且必须完整遍历两遍才能得到结果。

### Safe Softmax

safe-softmax，减去一个最大值防止在计算过程中数据发生溢出

 **为什么减去最大值就能防止溢出？** 
 数学上，$\frac{e^{x_i}}{\sum_j e^{x_j}} = \frac{e^{x_i-m}}{\sum_j e^{x_j-m}}$（分子分母同除 $e^m$，完全等价）。
 减去 $m=\max x_j$ 后，所有指数项 $e^{x_i-m} \leq e^0 = 1$，被压入 $(0,1]$ 区间，**不可能上溢为 `inf`**。即使某些项因 $x_i-m$ 过于负而下溢为 0，只要分母中至少有 $e^0=1$ 不为 0，计算结果就是正确的。

因为在safe softmax里面减去了一个最大值，所以说safe softmax的访存次数会多1次(和朴素softmax相比)
### Online Softmax

 减少内存访问次数来计算经典的softmax算法，softmax和topK融合能够得到更大的加速比

Online Softmax（即 Safe Softmax with online normalizer calculation）通过**在单次遍历中同步维护运行最大值 $m$ 与归一化项 $d$**，将每个元素的内存访问从四次降低到三次。算法如下：

![[file-20260716152003043.png]]

**核心思想**：第一遍遍历中，每遇到一个新元素 $x_j$，如果它比已知最大值 $m_{j-1}$ 更大，就把之前累积的归一化项 $d_{j-1}$ 乘以 $e^{m_{j-1}-m_j}$ 进行缩放修正，然后加上当前项的贡献 $e^{x_j - m_j}$。这样在遍历结束时就直接得到了全局最大值 $m_V$ 和完整的归一化分母 $d_V$，第二遍遍历即可用 $y_i = e^{x_i - m_V} / d_V$ 算出最终结果。

这个"遇到更大值时对历史归一化项缩放修正"的操作，正是后续 Flash Attention 分块 softmax 中 online rescale 的基础。

#### Softmax 与 TopK 的融合

在线 Softmax 还能与 TopK 选择进一步融合，在**单次遍历中同时维护最大值 $m$、归一化项 $d$ 以及一个长度为 $K+1$ 的运行 TopK 数组**。算法如下：

![[file-20260716152720698.png]]

**为什么只需一次内存访问？** 关键在于：Online Softmax 本身已经把"求最大值"和"求归一化分母"合并到同一遍遍历中了；而 ==TopK 维护的运行数组 $u$ 始终驻留在寄存器中==，新元素 $x_j$ 只需读入一次——既参与 $m$ 和 $d$ 的在线更新，又被插入到 $u$ 的排序中。遍历结束后，只需对 TopK 数组中的 $K$ 个元素做一次归一化，无需再回读整个输入向量。因此整个 Softmax + TopK 组合对每个元素仅需 **一次内存访问**（读取 $x_j$），相比朴素 Softmax 的两次遍历大幅减少了 IO 开销。

### Flash Attention中的softmax

![[file-20260715211357041.png]]

Softmax是按行进行的，那么就必须解决softmax的分块计算问题。Flash Attention 论文将向量 $x \in \mathbb{R}^B$ 的 softmax 数值稳定计算分解为四步：

$$m(x) := \max_i x_i, \quad f(x) := [e^{x_1 - m(x)} \;\cdots\; e^{x_B - m(x)}], \quad \ell(x) := \sum_i f(x)_i, \quad \text{softmax}(x) := \frac{f(x)}{\ell(x)}$$

这四步（求最大值 $m(x)$ → 减最大值后指数 $f(x)$ → 求和 $\ell(x)$ → 除法得结果）的意义在于：减去最大值避免了指数爆炸，同时将 softmax 拆为**独立的可组合操作**，为后续分块增量更新奠定了数学基础。

#### 分块分解

![[file-20260715222203885.png|200]]

将输入 $x$ 拆为两块 $x = [x^{(1)}, x^{(2)}]$（$x^{(1)}, x^{(2)} \in \mathbb{R}^B$），则拼接后 $x = [x^{(1)}\; x^{(2)}] \in \mathbb{R}^{2B}$ 的 softmax 可分解为：

$$m(x) = \max\!\bigl(m(x^{(1)}),\; m(x^{(2)})\bigr)$$

$$f(x) = \bigl[ e^{m(x^{(1)}) - m(x)} f(x^{(1)}),\;\; e^{m(x^{(2)}) - m(x)} f(x^{(2)}) \bigr]$$

$$\ell(x) = e^{m(x^{(1)}) - m(x)}\,\ell(x^{(1)}) + e^{m(x^{(2)}) - m(x)}\,\ell(x^{(2)})$$

$$\text{softmax}(x) = \frac{f(x)}{\ell(x)}$$

也就是说：**全局最大值取两块中较大者，全局 $\ell$ 为缩放后的加权求和**。只要维护当前 $m$ 和 $\ell$ 两个统计量，就可以逐块处理长序列，无需一次性读取全部元素——这正是 Flash Attention 免写回 HBM 的数学基础。

Online Softmax 的作用正是让这个逐块计算成为可能：它维护每一行目前看到的最大值 $m$ 和归一化分母 $\ell$，当新的 tile 到来时，先更新 max，再把旧的分母和旧输出按比例 rescale，最后累加当前 tile 的贡献。这一步非常关键，因为普通 softmax 需要知道整行的最大值和总和；online softmax 让 Flash Attention 可以在分块条件下仍然得到和标准 attention 等价的结果。

分块 softmax 的核心：**每个 block 先用自己的局部 max 做稳定计算；合并时再用新的全局 max 把旧结果重新缩放到同一个尺度上**。

### 对 Memory Access 和计算过程的影响

![[file-20260715211626237.png]]

这种分块方式的最大收益是减少 HBM 访问：

- Naive attention 需要把完整的 `S = QK^T` 写入 HBM，再读出做 softmax；还要把完整的 `P = softmax(S)` 写入 HBM，再读出与 `V` 相乘。
- 分块 softmax / Flash Attention 不需要 materialize 完整的 `S` 和 `P`。每次只在 SRAM 中处理一个 score tile，更新 `m`、`l` 和输出累加值 `O`。
- 最终主要写回的是输出 `O`，以及训练反向所需的少量统计量，而不是巨大的 `N×N` attention matrix。

代价是计算过程变复杂：

- 每处理一个 tile，都要维护并更新 `m`、`l`；
- 当新的 tile 最大值更大时，需要对之前累计的 `l` 和 `O` 做 rescale；
- 反向传播时如果没有保存完整 `S/P`，需要通过 recomputation 重新计算局部 score。

因此 Flash Attention 的本质是：**用少量额外计算和更复杂的在线归一化逻辑，换取大幅减少 HBM IO**。这正好适合 GPU，因为矩阵乘法算力很强，而 HBM 访问通常更容易成为瓶颈。

## Flashattention的伪代码

![[file-20260724161303636.png]]

FlashAttention中的双缓冲机制[[SystolicAttention#AttentionCore的实现]]

## Flash Attention2

Flash Attention-2 进一步优化了并行划分和 kernel 内部的数据流，减少 non-matmul 操作的开销，并提高 warp/block 的利用率。整体思路仍然是：把 Q/K/V 的 tile 放到 SRAM 中，局部计算 `QK^T`，用 online softmax 更新归一化统计量，并立即和 V 累加得到输出，避免把完整 `S` 或 `P` 写回 HBM。FA2更关注Transformer中的计算效率问题。

1. 调整算法中的非浮点计算量
2. 在线程块级别优化并行度
3. 在warp级别优化负载分配
  
## Flash Attention3

Attention块在计算的过程中涉及数据在不同计算单元之间的搬运和分配
[[SCOPE#GEMM和SFU之间的失配]]
访存和数据搬运成为了Attention Kernel的一个瓶颈

Flash-Atten的操作能够被流水线化吗？

基于这一问题，FlashAttention对于高性能GPU做了优化，提出了乒乓调度等流水线化技术。
## 总结

GPU 的强项是高并行吞吐，但瓶颈经常来自 HBM 访问、控制分歧、tile 不对齐和中间结果反复读写。通用优化技巧包括低精度计算、算子融合、recomputation、memory coalescing 和 tiling。Flash Attention 正是这些思想在 attention 上的集中应用：它不改变 attention 的数学结果，而是通过分块、在线 softmax、融合计算和反向重计算，避免显式保存完整 `N×N` attention matrix，从而把性能瓶颈从 HBM IO 尽量转移回 GPU 擅长的矩阵计算。
