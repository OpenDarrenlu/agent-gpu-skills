# PEARL: 并行投机解码，推理加速最新SOTA（blog/paper/code均开源）

**作者**: 笑渐不闻声渐悄​中国科学技术大学  信息与通信工程博士在读

**原文链接**: https://zhuanlan.zhihu.com/p/716769091

---

🔥 [2025.10] News: nano-PEARL 正式开源！想看看投机接码在Prefix Caching / Tensor Parallel / CUDA Graph / Flash Attention / Paged Attention各种技术的加持下能达到什么水平吗？（过两天会发一个具体介绍blog）

nano-PEARL
github.com/smart-lty/nano-PEARL

News: PEARL被ICLR 2025接受啦！

Blog: https://pearl-code.github.io/

paper: https://arxiv.org/abs/2408.11850

code: GitHub - smart-lty/ParallelSpeculativeDecoding: The official code for paper "parallel speculative decoding with adaptive draft length."

Introduction

随着LLM的应用逐渐广泛，研究其推理性能的加速已经成为业界和学界均关注的重点。随着speculative decoding的横空出世，业界和学界均纷纷下场。对于不了解投机采样的读者，这里推荐大佬 @方佳瑞 的文章以供参考方佳瑞：大模型推理妙招—投机采样（Speculative Decoding）。

简单做一个Speculative Decoding的介绍，它的产生逻辑是这样的：

LLM的推理是auto-regressive decoding，即它的每一步是用LLM预测出next token的distribution 
𝑝
(
𝑥
𝑡
+
1
|
𝑥
≤
𝑡
)
 ，然后再从此分布中sample出一个token 
𝑥
𝑡
+
1
 。
在给定一个prefix时，LLM首先生成所有prefix token的kv cache (称之为prefilling stage)，然后基于kv cache迭代式地预测next token（称之为decoding stage）。不了解kv cache的同学可以参考看图学：大模型推理加速：看图学KV Cache。相比于prefilling阶段，decoding阶段所需的算力是非常冗余的。在decoding阶段，即使一次性输入多个token的运算时间，也和仅输入1个token的运算时间相当。
基于上述结论，我们可以使用一个额外的draft model来生成多个draft tokens，然后使用原模型 (target model) 来通过一次forward验证多个draft tokens。由于LLM的causal mask特性，这种仅通过一次forward的验证方式是可行的。

一言以蔽之，投机采样的本质是利用decoding阶段冗余的算力去进行额外的解码。

Motivation

然而，投机采样算法有一个很关键的问题，我们称之为mutual waiting problem: 在draft model运行期间，target model是停止的；而在target model运行期间，draft model又是停止的。这个问题是由投机采样的算法所决定的——draft model (target model) 的输入是由target model (draft model) 上一轮的输出所决定的。同时，在实际情况中，这个问题又是很显著的：比如使用codellama 7B作为draft model，codellama 70B作为target model时，在每一轮speculative decoding step中，draft model需要等待target model 0.07s，而target model需要等待draft model 0.14s！这显然造成了latency的增加，以及GPU资源的浪费。

fig 1: mutual waiting problem.

为了解决这个问题，我们很自然地设想，当draft model (target model)在运行时，target model (draft model)能不能干点什么？基于这么一个motivation，我们提出了PEARL，具体如图所示：

fig 2: overview of PEARL.

其实整体idea非常简单：

pre-verify: 当draft model在运行时，target model可以基于draft model的输入并行运算，这样就可以提前验证第一个draft token；如果target model发现第一个draft token就已经错了，那就没必要在进行一次完整地验证，这样就可以跳过一次verification (1 target model forward)；
post-verify: 当target model在运行时，draft model可以继续生成draft tokens。如果上一轮的draft tokens全部被target model接受，那就可以省下一次drafting的过程 ( \gamma draft model forward)。

当然还有技术上的一些细节，读者可以参考我们的论文。虽然这个idea看起来非常简单，但它却是"simple yet effective"的，因为有以下两个theoretical findings:

PEARL的 \gamma 的理论最优值可以确定为 c ，即draft model和target model的运算速度之比。这一点是很重要的：speculative decoding的 \gamma 需要多次试验得到最优值，而且还会随着model / task的变化而变化；但在PEARL框架下，只需要简单测量一下大小模型的运算速度之比，即可确定 \gamma 。
PEARL可以实现adaptive draft length。当问题比较简单，draft model一次性能生成很多个token时，它就可以通过post-verify 一次性生成多个draft tokens; 而当问题比较困难，draft model的输出并不会被target model接受时，又可以通过pre-verify来提前终止draft model的运行。PEARL的期望接受token数要高于speculative decoding。我们在实验中也发现，PEARL的accepted token length要远高于speculative decoding。

值得注意的是，PEARL可以和其他的投机采样工作相结合（EAGLE，DistillSpec，Lookahead等）。

Experiments

然后就是实验表现：在所有的model pairs和benchmark上，PEARL都可以取得speculative decoding的1.3倍到1.5倍加速比，大约是auto-regressive decoding的3到4倍。这个加速比还是很可观的。

fig 3: experimental results.

截至目前位置，还有部分额外的数据结果没有release，比如Llama 3.1 8&70B在HumanEval, GSM8K, MT-bench 和MGSM四个benchmark上可以取得3.87, 3.81, 3.59, 3.95的加速比。不过PEARL的效果确实是非常惊艳。

为了更直观地感受PEARL的adaptive draft length的威力，我们给出下表：

fig 4: average accpeted length of PEARL and SD.

PEARL可以取得SD 3倍以上的average accepted length! 这也充分地证明了PEARL相比于speculative decoding的优势。

Limitations

这里我想简单聊一下PEARL的一些limitations。读到这，很多有MLSys经验的读者就会问，怎么实现draft model和target model的并行？会不会产生资源竞争？大小模型在同一个device时该怎么解决？

对此，我们给出了一个dynamic resource allocation的解决方案，来解决target model需要分布在2张卡以上的资源竞争情况。（target model和draft model都只需要1张卡，且都布置在同一张卡上的情况需要其他解决方案）

我们知道，实际LLM的应用中，target model通常是需要布置在多张GPU上的（要不然快速增长的kv cache就会把显存挤爆）。在这种情况下，LLM是需要把参数分发到不同的GPU上，通过pipeline parallism来进行推理。那这种时候，就可以通过动态的资源分配，来避免draft model和target model在同一张GPU上运算时的资源竞争。

举个例子：假设 c=5 , target model需要分发到4块卡上。假设target model运行1次forward的时间为t，则它在GPU 0上的运行时间为 t/4。我们假设一个时间间隔为 t/20，则在20个时间间隔内，target model所占用的GPU编号依次为：

0, 0, 0, 0, 0; 1, 1, 1, 1, 1; 2, 2, 2, 2, 2; 3, 3, 3, 3, 3;

假设draft model布置在0号卡上，则它在20个时间间隔内所占据的GPU编号为：

0, 0, 0, 0; 0, 0, 0, 0; 0, 0, 0, 0; 0, 0, 0, 0; 0, 0, 0, 0;

可以看到，资源竞争主要在前5个时间间隔内发生。我们可以把draft model复制一份到最后一个GPU上，在生成前一半 (向上取整为3个) 的draft tokens时，使用最后一张卡，生成后一半 (向下取整为2个) 的draft tokens时，使用第一张卡，则它在20个时间间隔内所占据的GPU编号为：

3, 3, 3, 3; 3, 3, 3, 3; 3, 3, 3, 3; 0, 0, 0, 0; 0, 0, 0, 0;

可以发现，在任何一个时间间隔内都没有资源竞争！当然，这个简单模拟的假设和实际情况会有所出入，实际上还是会发生一定程度的资源竞争。我们做了一些实验来验证这种动态分配资源方案的有效性：（RC=PEARL in resource competitions）

MT-bench	average speed
Llama 2 7b&70b	24.28 tok/s
Llama 2 7&70b (RC)	22.83 tok/s
Llama3.1 8&70b	32.14 tok/s
Llama 3.1 8&70b (RC)	30.78 tok/s
HumanEval	average speed
Deepseek 1.3&33B	57.76 tok/s
Deepseek 1.3&33B (RC)	53.86 tok/s

可以发现，通过这种动态分配资源的方法，可以有效缓解资源竞争问题（性能损失在5%以内）。这种dynamic resource allocation的方法也进一步提升了PEARL的应用范围。

总结

我们提出了一个并行投机采样框架PEARL来解决mutual waiting problem，并通过adaptive draft length来显著提高投机采样的加速效果。

欢迎对LLM推理加速、投机采样感兴趣的同学联系我一起讨论、合作！
