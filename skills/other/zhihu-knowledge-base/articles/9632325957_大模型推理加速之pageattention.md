# 大模型推理加速之pageattention

**作者**: 李安渝infra小菜鸡

**原文链接**: https://zhuanlan.zhihu.com/p/9632325957

---

​
目录
收起
大模型推理过程
prefill阶段
decode阶段
kv cache优化
不使用KV Cache的推理过程
使用KV Cache的推理过程
pageattention原理介绍
参考来源
大模型推理过程

在大型语言模型（LLM）的推理过程中，通常会分为两个阶段：prefill和decode。这两个阶段在处理输入和生成输出时具有不同的特点。以下是这两个阶段的详细解释

prefill阶段和decode阶段
prefill阶段

预填充阶段。在这个阶段中，我们把整段prompt喂给模型做forward计算。然后根据forward生成的第一个token开启 decode阶段。

decode阶段

decode阶段是模型生成回答的阶段，我们根据 prefill阶段生成的token逐个生成新的token，最后组成大模型的回答。

kv cache优化

前面简单讲了一下模型的推理流程分类，这节我们讲一下大模型针对这两个阶段做出的优化-KV Cache优化。

基于Transformer的大模型中最重要的部分就是自注意力机制。自注意力机制允许模型在处理输入序列时，能够动态地关注序列中不同位置的信息，从而捕捉长距离依赖关系。

self attention计算

我们看到根据X和不同W，可以得到我们注意力机制需要的QKV三个矩阵。但是有个现象是输入X随着推理的加长往往会变得非常的大，那么得到QKV三个矩阵的运算将会变得非常大并且很多计算是重复多余的，但是这并不是不可避免的。KV Cache优化就是将之前的运算结果存储起来减少attention中的重复运算。

不使用KV Cache的推理过程

我们来具体看一下不使用KVcache的推理流程。

prefill阶段
decode阶段

如上图可以看到，在prefill阶段生成的token和原输入X拼接成新的输入X从而进入decode阶段。在decode阶段新输入X再次和W_Q、W_K以及W_V运算得到新的QKV三个矩阵。但是通过观察prefill阶段和decode阶段的Q、K、V三个矩阵会发现矩阵只有最后一行是有不一样的，这最后一行是新生成的token和和W_Q、W_K以及W_V运算得到的那么前几行属于重复运算得到相同的结果。在看后续流程Q@K^T的结果，虽然我们在第一步做矩阵乘法的时候发现新的到矩阵确实和prefill阶段的矩阵没有可以复用的地方但是在经过mask(掩码操作)之后，可以看到紫色的部分已经完全和prefill阶段一模一样了，只是随着输入的变大多出来了-inf的值。再经过后序的softmax之后这些 -inf的掩码值将会变成0不对后续计算产生实质性影响。

在QK计算完注意力分数之后再和V矩阵进行最后的矩阵乘法运算，可以看到decode阶段的V矩阵和prefill阶段的V矩阵也只有由于新token的加入而得到一行值有区别。在score@V中 也是只有最后一行的值和前一个阶段是具有不同的。并且在最后的FFN阶段，我们也只是生成了一个新的token。

针对前面的分析，我们可以看到在self-attention阶段再不使用KVCache的情况下会出现大量的重复运算。但是 由于mask操作的存在 ，很多重复操作我们应该缓存下来从而 减少运算的次数，提高模型运算效率

使用KV Cache的推理过程

前面我们 分析了不使用 KVCache的推理流程，并看到不使用的KVCache会带来巨大的重复运算浪费计算计算。这节我们看一下使用KVCache推理流程的变换

prefill阶段
KVCache的decode阶段

可以看到在 使用KV之后，我们在decode阶段会将上一次计算的K矩阵和V矩阵缓存起来也就是图中的k_last和V_last，通过新token和W_K 以及W_V的运算得到 K_cur和V_cur并和缓存的K_last以及V_last进行拼接组成需要的K矩阵和V矩阵。接着完成后序的softmax以及矩阵乘法和FFN阶段直到生成新的token，通过两张图的对比我们可以直观的感受到使用KVCache之后，我们减少了很多的运算，从而加快推理速度。

有一个点值得注意的是，我们并有将Q缓存起来 ，因为在decode阶段我是通过每一次新生成的token来推理下一个token，而后续的推理流程也是和这个新生成的token有关，和前序的X生成Q是 无关的所以不需要将 Q缓存起来。

pageattention原理介绍

讲完KVCache优化，我们正式进入page attention的介绍。首先介绍一下page attention，pageattention作者受操作系统虚拟内存和分页思想启发，将原本连续的 KV cache 存储在不连续的空间，以避免 KV cache 带来的显存浪费。

这里我们先讲为什么KV会带来显存浪费的问题。在常规的推理框架中，当我们的服务接收到一条请求时，它会为这条请求中的prompts分配gpu显存空间，其中就包括对KV cache的分配。但是生成的序列长度是未知的，框架根据可能生成的最大长度来 预留内存空间，然而这样容易导致预留空间过大 ，一部分空间被预留了但是并没有被用到导致严重的显存浪费问题。并且预留空间过大之后剩下的显存空间会不足以支持后序请求的处理。这两个影响被page attention归纳为gpu显存的内部碎片和 外部碎片。

如下图所示，为requestA和requestB都预留了相当大的内存空间但是这些空间都没有被利用完全，从而导致非常严重的内部碎片和外部碎片问题

KVCache的问题

并且论文作者指出，在内存分配上KVCache已经占据了相当大的比重，但是由于碎片化问题先存的利用率是远远不够的。

论文作者根据操作系统的虚拟内存思想和分页管理技术，提出了pageattention技术。通过动态地为请求分配KVCache显存，从而提高显存的利用率。

还是 通过大模型推理的两个阶段来看看pageattention是如何工作的。当你想模型发送一个promt“Alan Turing is a computer scientist”，我们首先处理prompt也就是prefill阶段。

在进入到prefill阶段之间，还有一个模型初始化阶段。在这个初始化阶段，pageattention还是预留了一大块显存用来存储KVCache，但是它将一大块分为若干个小块。并结合操作系统的内存管理思想，划分出Physical KV cache blocks、Logical KV cache blocks以及用于虚拟块和真实块转换的块表Block table。

初始化阶段

再详细介绍一下逻辑块、物理块和 块表：

逻辑内存（logical KV blocks）可理解为操作系统中的虚拟内存，每个block类比于虚拟内存中的一个page。每个block的大小是固定的，在vLLM中默认大小为16，即可装16个token的K/V值
块表（block table）可理解为操作系统中的虚拟内存到物理内存的映射表
物理内存（physical KV blocks）可理解为操作系统中的物理内存，物理块在gpu显存上，每个block类比于虚拟内存中的一个page

接着来看prefill阶段的处理，page attention首先将收到的prompt按照设定好的BLock大小进行划分，然后再划分好逻辑块之后，将其映射到真实的物理块，在物理块中存放真正的KVCache值，并通过块表进行映射关系的保留

prompt的page划分

划分完对应的block之后，就需要接着利用KVCache走推理流程。上图可以看到 ，初始 promt占据了Block 0 和Block 1。Block0的所有位置都被占满，但是Block1的位置还有空余，所以在推理生成 新的token之后会优先安置在Block1的后序空闲位置。

推理生成token

可以看到在推理得到 mathematician这个token的时候已经将空闲的Block1填满了，这个时候 后序的推理会重新找一个新的Block来存放下一轮的token

重新 分配Block存储token值

我们假设再生成renowned这个token之后这个请求就结束了，那浪费的空间就是Block2剩余的空闲空间，而不会是大量的预留空间被浪费。从上面的介绍中可以看到，PagedAttention 可以很好地解决现有推理系统 KV cache 产生的内外部碎片。

而在处理多请求时，page attention处理流程和单个请求处理流程也是一致的，先为每个请求的prompt申请逻辑块以及物理块，并将 映射关系存储在块表中。然后完成后序的推理过程

多请求的page attention

解决了KVCache严重的内部碎片和外部碎片之后，还解决了其他推理框架没有 解决的无法利用共享空间的问题。

在描述这个问题之前，我们先了解一下两种比较常用的解码算法：

parallel sampling：我给模型发送一个请求，希望它对prompt做续写，并给出三种不同的回答。我们管这个场景叫parallel sampling。在这个场景中，我们可以将prompt复制3次后拼接成1个batch喂给模型，让它做推理。但我们也需注意到，这种方式会产生prompt部分KV cache的重复存储。
parallel sampling
beam search：束搜索，这是LLM常用的deocde策略之一，即在每个decode阶段，我不是只产生1个token，而是产生top k个token（这里k也被称为束宽）。top k个token必然对应着此刻的top k个序列。以此类推。不难想象每一时刻我把top k序列喂给模型时，它们的前置token中有大量的KV cache是重复的。

针对parallel sampling，传统的模型通常是为每一个输出都预留出一大块的KVCache的空间。比如模型最大输出的长度max_len=1024/2048并且希望模型输出2个答案，那传统的方法就预留2*max_len的空间。但是这些答案 是针对 同一个prompt的不同输入而已，那么就必然在这两个预留空间中存在大量重复的KVCache，这是不可以接受的。

page attention存在 逻辑块 和 物理块的映射关系 ，在针对paralle sampling的时候我们针对每个输出的结果都划分不同的逻辑块但是这些逻辑块通过 块表指向相同的物理块这样可以解决大量重复的KVCache。这样能保证每个输出在逻辑块是相互独立的 两个程序，只是共用相同的物理空间。并设置 ref_conut变量，统计有几个请求同时依赖这个block。

进入decode阶段，每个请求通过 推理得到了不一样的token。这样就不能同时共享相同的内存空间了，如下图SampleA1 和SampleA2 通过推理得到了不一样的token，Sample A1在写入新token的时候，检测到ref_count不为1，所以它首先将共享的Block 1 复制一份到Block3，并将ref_count减1然后将自己生成的token写入新块的空闲位置。与此同时Sample A2想要写入的时候检查到ref_count已经变成1了，所以顺利将自己的新token写入Block1的空闲位置。自此，两个sample顺利 完成本次decode阶段。这种机制在page attention中被称为copy-on-write机制 ，只有在ref_count等于1的时候允许写入。

Parallel sampling example

总结起来，对于处理parallel Sampling的显存浪费问题就是对于相同数据对应的KV cache，能复用则尽量复用；无法复用时，再考虑开辟新的物理空间。

而针对beam search，pageattention的解决办法又略有不同。

如 下图所示，beam width = 4，这意味着根据beam search算法，在当前阶段我们生成了top 4个概率最大的token，也就是beam candidate 0/1/2/3。下图虚线位置 表示当前decoding时刻，图中所有的block皆为逻辑块。

在当前decode阶段，我们仍然需要 选择top 4的token。经过我们的计算，这top 4 next token，有2个来自beam candidate 1，有2个来自beam candidate 2。其中由block6中引出block9和block10，用于装其中两个top 2 next token；对block7也是同理。现在，block9/10/11/12中装的top 4 next token，就成为新的beam candidates。下一轮将在Block9、10、11、12中进行decode并生成新的top 4 token。

现在，我们转换视角来看看是如何节省显存空间的。可以 看到虚线左边的4个candidate是由上一轮的candidate1和candidate3生成的。candidate0 和 candidate2占据的逻辑块已经全部释放了，所以没有画出来。

这一轮新生成candidate的Block 9 和 Block10是依赖于Block 6的，Block11 和Block12 是依赖于Block 7 生成，所以Block 6 和Block 7 在后序推理中还需要被用到。而上一轮中剩下 candidate Block 5 和Block8则在后序推理就 不再被依赖了，所以可以释放对应的物理块空间。可以看到Block 8 依赖的Block链路在后序中都不会再被依赖，所以这些Block全部被释放来节省空间，而Block 5 依赖 的Block3以及之前的Block都 在后序中被依赖，所以不能释放。

beam search example

这一路上，我们都根据最新时刻的beam search decoding结果，释放掉不再被需要的逻辑块和对应的物理内存空间，达到节省显存的目的。

到这里，page attention的背景、解决的问题和理论原理都已经介绍完毕了。后续将会更新page attention cuda代码 的解读以及基于page attention的VLLM框架的解读

参考来源

[1]LLM 推理优化之 KV Cache-HelloWorld

[2]看图学：大模型推理加速：看图学KV Cache

[3]猛猿：图解大模型计算加速系列之：vLLM核心技术PagedAttention原理

[4]HelloWorld：vLLM（一）PagedAttention 算法

[5]Fast LLM Serving with vLLM and PagedAttention_哔哩哔哩_bilibili

[6]VLLM作者PPT

[7]pageattention论文
