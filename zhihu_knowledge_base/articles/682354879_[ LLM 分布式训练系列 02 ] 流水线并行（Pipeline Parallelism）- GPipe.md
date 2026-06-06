# [ LLM 分布式训练系列 02 ] 流水线并行（Pipeline Parallelism）- GPipe

**作者**: Alan 小分享​香港科技大学 资讯科技硕士

**原文链接**: https://zhuanlan.zhihu.com/p/682354879

---

​
目录
收起
一、要解决的问题
二、算法
2.1、Naive Model Parallelism
2.2、Pipeline Parallelism - Part 1 - Split into micro-batches
2.3、Pipeline Parallelism - Part 2 - 通过 re-materialization 降低显存占用
2.4、空间复杂度 && GPU 空闲时间
3、实验结果
3.1、增加 GPU 数量，训练更大模型
3.2、训练速度如何
4、总结

【本文是 “LLM 分布式训练系列” 的第 2 篇，持续更新中】：

[ LLM 分布式训练系列 01 ] 概览 && 数据并行（Data Parallelism）- DP, DDP, ZeRO

[ LLM 分布式训练系列 02 ] 流水线并行（Pipeline Parallelism）- GPipe

在 LLM 分布式训练这个系列，我打算记录一下目前主要的几种并行方法：

流水线并行（Pipeline Parallelism）
数据并行（Data Parallelism）
张量并行（Tensor Parallelism）

本篇文章以 Google 在 2019 年推出的 GPipe [1] 为例，介绍下流水线并行的原理。

（配合沐神的讲解视频一起服用，效果更佳：

一、要解决的问题

主要问题就是：如何高效训练更大的模型？

然后再进一步拆分为子问题：

提高训练速度：理想情况下，GPU 数量增加到 n 倍，训练速度也能提升 n 倍或以上（其他条件不变）；
训练更大模型：理想情况下，GPU 数量增加到 n 倍，可以训练的模型参数规模也提升到 n 倍或以上（其他条件不变）
模型结构易于切分，进行分布式训练：GPipe 针对的是多层的，且层间可以切分的模型；（现在基于 transformer 的架构都挺容易切分的（层间或者层内都是），而且切分后的负载也很均衡；）




二、算法
2.1、Naive Model Parallelism

对于多层的模型，当参数过大，单卡装不下时，一个直观的方式就是按层切分，每一部分放到一块上。

比如模型有 12 层（layer），可以切为 4 份（论文中称每一份为一个 cell），每份 3 层。然后每份放到一块 GPU 上。

整体结构：

第 k 个 cell 的模型参数，就放在第 k 块 GPU 上。（按上面的例子，每块 GPU 保存了 3 个 layer 的参数）

F_k 和 B_k 分别表示第 k 个 cell 的 forward 和 backward 计算；




对于单个 batch，计算顺序就是这样子：

图中的下标 ‘0’ 表示这是第 0 个 batch；每一种颜色代表一块 GPU，每一列代表一个时间段；

整体含义：在 GPU 0 上完成第一个 cell 对应的子模型的计算，然后结果传给 GPU 1，依次类推；直到 forward 完成后，开始进行 backward。直到 GPU 0 完成 backward 后，使用当前 batch 计算得到的梯度，统一更新（synchronous）所有层的参数。




这样做的话，最明显的问题是，每块 GPU 都会有大量的空闲时间，所以论文提出了改进方法。




2.2、Pipeline Parallelism - Part 1 - Split into micro-batches

思路：将每个原始 batch （论文中称为 mini-batch）切分为多个 micro-batch，然后依次送进 GPU 中进行流水线执行。

直观来看，原来的方式中， 每个时间点，只会有一块 GPU 在工作。切分以后，每个时间点，就可以有多块 GPU 跑不同的 mirco-batch。过程有点类似于 CPU 执行指令时，将指令切成多个步骤，然后流水线执行，所以这个算法称为 Pipeline Parallelism。




Q：为什么不直接并发跑多个 batch，而要拆分当前 batch？

A：（1）最好是跑完一个 batch，得到梯度，更新完参数，再跑下一个，这样比较稳定；（2）多个 batch 同时跑的话，需要保存的中间结果多很多；




来看看流程图：

其中，第一个下标表示 GPU 编号（或者直接看颜色，相同颜色就表示在同一块 GPU 上），第二个下标表示 micro-batch 编号。




2.3、Pipeline Parallelism - Part 2 - 通过 re-materialization 降低显存占用

思路：每块 GPU 只保留最开始的输入，中间结果全部丢掉；计算梯度时，再重新计算这些中间结果。这样就可以节省很多内存了。

这个方式在论文中称为 re-marerialization，后来的工作中也称为 active checkpoint。




Q：计算梯度时为什么需要中间结果？

A：假设当前有两层全连接层：（ \sigma 为激活函数）

z_1 = W_1 * x_1 ， y_1 = \sigma(z_1)

z_2 = W_2 * y_1 ， y_2 = \sigma(z_2)

例如计算 W_2 的梯度，就需要用到 y_1 。

具体公式：

\[ \frac{\partial L}{\partial W_2} = \frac{\partial L}{\partial y_2} \cdot \frac{\partial y_2}{\partial z_2} \cdot \frac{\partial z_2}{\partial W_2} = \frac{\partial L}{\partial y_2} \cdot \frac{\partial y_2}{\partial z_2} \cdot y_1^T \] （其中 L 表示损失函数）




回到前面的思路，进行 forward 阶段时，z1、y1、z2、y2 这些中间结果，全都丢弃，只保存最开始的输入 x1。等到计算梯度时，再重新计算这些中间结果。

所以单个 GPU 内的数据流大概是这样子：


其中，绿色块表示输入数据，需要保存下来；灰色块表示中间结果，用完就可以丢。

如果不采用 re-marerialization，那就要把灰色块都保留下来，这样需要占用的显存就多很多了～




2.4、空间复杂度 && GPU 空闲时间

（1）空间复杂度

记原始 batch 的大小为 N，切分为 M 个 micro-batch；模型一共有 L 层，切分为 K 个 cell。

来看当个 GPU，对于每个 micro-batch，都需要保存输入数据，所以复杂度是 O(N)；另外计算梯度时，需要重算当前 micro-batch 所有中间结果（即上面单个虚线框内，所有数据都需要存下来，计算完梯度再丢弃），所以复杂度是 O(\frac{L}{K} \times \frac{N}{M}) ，即当前 GPU 一共有 \frac{L}{K} 层，每层的数据量为 \frac{N}{M} 。

加起来就是 O(N + \frac{L}{K} \times \frac{N}{M}) 。

（2）GPU 空闲时间

上面图 (c) 中的白色区域，就是 GPU 的空闲时间。算下面积，就可以直到占比了。

所以空间时间的复杂度为： O(\frac{K - 1}{M + K - 1} )

作者在实验中发现，当 M \geq 4 \times K 时，空闲时间就对整体训练时长没有明显的影响了。




3、实验结果
3.1、增加 GPU 数量，训练更大模型

看看使用 GPipe 跑 AmoebaNet 和 Transformer 两种模型的实验结果：

其中，

Naive-1 表示单卡上的结果；
Pipeline-k 表示在 k 块 GPU 上运行 GPipe；
# of Model Parameters 表示模型的参数量；

可以发现：

整体效果还是很强的，能顺利跑更大的模型了；
对于 AmoebaNet-D，由于各个层之间的参数数量不是均匀分布，所以模型参数量不是随着 GPU 数量增加而完美地线性增长；Transformer 的参数则非常均匀，所以这两个数值是比较完美的线性关系；




3.2、训练速度如何

在 AmoebaNet-D(18, 256) 和 Transformer-48 上跑，尝试不同的 K（对应 GPU 数量） 和 M（micro-batch 数量），训练速度的对比结果如下：

当 M = 1 时，就相当于 2.1 中说的 Naive Model Parallelism。

可以发现：

当 M = 1 时，增加 GPU 数量并不能显著提高训练速度；
当 M = 32 时，则可以显著提高，因为降低了空闲时间的占比；




4、总结

效果很好，孩子很满意，加钱买卡就完事了！




Reference:

[1] GPipe: Efficient Training of Giant Neural Networks using Pipeline Parallelism

[2] GPipe论文精读【论文精读】

[3] 猛猿：图解大模型训练之：流水线并行（Pipeline Parallelism），以Gpipe为例
