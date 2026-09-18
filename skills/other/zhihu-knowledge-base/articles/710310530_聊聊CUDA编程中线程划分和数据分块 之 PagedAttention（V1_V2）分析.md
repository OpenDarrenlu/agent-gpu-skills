# 聊聊CUDA编程中线程划分和数据分块 之 PagedAttention（V1/V2）分析

**作者**: 杨鹏程​腾讯 员工

**原文链接**: https://zhuanlan.zhihu.com/p/710310530

---

​
目录
收起
前言
PagedAttention概览
线程划分和数据分块
线程划分
Q的加载
片外Q的数据结构
大于32bits的shared memory访问
K的加载
Q * K过程
Softmax 计算过程
V的加载
P*V的计算过程
最终结果的Reduce
PagedAttentionV2的reduce_kernel
计算全局max_logits
矫正各个partitions的exp_sum
rescale tmp_out并reduce
参考
前言

在学习CUDA编程时，线程的划分以及对应数据分块经常让人难以理解，这篇文章将以PagedAttention为例，介绍它的线程和数据的划分逻辑。这将会是一个系列，主要话题是讨论针对具体计算任务，如何划分thread-block内线程和对应的数据块。这个系列文章将围绕着分析主流的kernel展开，学习主流kernel如何规划thread-block的线程和对应的数据块。这也是CUDA编程，或者说SIMT编程的一大难点。这个系列预计有PagedAttentionV1-2，FlashAttentionV1-3，FlashInfer，还会有一些量化Kernel等。如果有新的Kernel出现，也会加入进来，所以它将会一直进行下去，除非笔者转行。另外，笔者还是一名一线工作者，创作（或者说学习）工作一般只有在周末，而且cuda/cutlass/thrust等相关代码，一般比较难阅读，还需要配合大量的debug，耗费大量的时间，所以这个这个系列的文章将会更新比较缓慢，本文是这个系列第一篇。

PagedAttention概览
PagedAttention(V1/V2)概览图

PageAttention的宏观逻辑如上图，KV-Cache是由block-table间接访问，分partition逻辑在block-table上完成，Q由于比较小，且会复用，预先会load到shared memory上。然后Q*K，local softmax，然后P * V，得到tmp_out，最后由reduce-kernel以online softmax方式reduce，不同于串行的online softmax，并行的可以直接得到全局最大的m,和全量的l。下面展开详细内容。

线程划分和数据分块
线程划分

PagedAttention（下文简称PA）在warp之下，继续划分为thread_group，一个thread_group的大小为max(WARP_SIZE/BLOCK_SIZE, 1)，vllm主要用到的Block_size的大小为16，所以我们以block_size=16展开描述。那么THREAD_GROUP_SIZE=2。每一个thread_group操作的数据大小为16bytes，这里之所以是16bytes，是因为当THREAD_GROUP_SIZE=1的时候，单线程一次load的的最大数据128bits，即16bytes，那么在THREAD_GROUP_SIZE=2时，thread_group中每一个线程load的数据就是8bytes。如果按照half的精度来分析，VEC_SIZE=4。下文中说到的大小将默认以half精度为单位。

Q的加载
片外Q的数据结构

q 在Global Mem上的shape是[num_seqs, num_heads, head_size]，其中num_seqs由blockIdx.y划分，num_heads由blockIdx.x划分，所以落到一个block需要load的数据只是一个head_size大小的vector。LLM里head_size基本都是128，这里以head_size=128展开。为了放下一个Q的head，PA设计了Q_vec q_vecs[THREAD_GROUP_SIZE][NUM_VECS_PER_THREAD] 的数据结构，Q_vec的大小4，那么q_vecs的总大小为128/4 = 32， THREAD_GROUP_SIZE=2，那么NUM_VECS_PER_THREAD（这个命名有歧义）大小为16，具体加载逻辑如下图：

q的加载
const scalar_t* q_ptr = q + seq_idx * q_stride + head_idx * HEAD_SIZE;
  __shared__ Q_vec q_vecs[THREAD_GROUP_SIZE][NUM_VECS_PER_THREAD];
#pragma unroll
  for (int i = thread_group_idx; i < NUM_VECS_PER_THREAD;
       i += NUM_THREAD_GROUPS) {
    const int vec_idx = thread_group_offset + i * THREAD_GROUP_SIZE;
    q_vecs[thread_group_offset][i] =
        *reinterpret_cast<const Q_vec*>(q_ptr + vec_idx * VEC_SIZE);
  }


（注：这里有个歧义点：NUM_VECS_PER_THREAD并不是一个线程要迭代这么多次，这里仅表示vec的数目，实际上这个load操作，在本例中，刚好由一个warp加载完成。这个常数本来是给后面用，这里重命名可能更好。）

先看global_mem的访问，thread_group中的0，1线程连续load连个vec，线程连续，访问的global_mem的地址也连续，符合仿存合并。继续看shared mem，这里shared mem的写不是一般32bit模式，而是64bit模式，分析方式也不相同。这里简单说明（后面可能以专题的方式展现）。

大于32bits的shared memory访问
shared memory的bank布局

如上图所示，一般shared mem为了加快访问throughput，将由32个bank组成，每一个bank在per cycle最大访问32bit的数据，当然其访问的粒度就是32bits，小于这个数值，也会返回32bits。如果一个warp中的每一个线程一次访问不同的bank，将会有最大的吞吐，也就是128bytes/cycle。一个warp内，如果有两个或者两个以上的线程访问到一个bank的不同地址上，就会发生bank conflict，带来的后果就是串行访问，降低性能。但是如果一次读取的数据量是64bits或者128bits，32个线程将会是256bytes或者512bytes，此时是不是必定会发生冲突。其实不一定。说明这个问题前，需要先知道wavefront（老版本叫transaction）的概念。它的定义：在requests结束处理时，生成唯一的work package，将其称为wavefront。每一个request至少生成一个wavefront。同一个wavefront里的不同工作项并行执行，多个wavefront之间按不同的周期串行处理。如果发生了bank conflict，之前一个wavefront执行的操作，需要多个wavefront，具体需要根据bank conflict的way数来确定。除此之外，使用64bits方式访问，由于超过了shared_mem的最大bankwidth，也需要拆分为多个wavefronts来访问shared mem，这种情况具体需要分为多少个，需要对half-warp分析bank conflict来确定。同样的道理，128bits需要对quarter-warp分析bank conflict，来确定最终的wavefront数。当然wavefront数量越少越好，所以也有L1 Wavefronts Shared Ideal指标，表示理想最少的L1访问的wavefronts数。这个话题内容很多，这里不进一步展开。后面有时间的话，单独写一篇详细介绍。

回到正文介绍Q的load过程，有没有shared mem的bank conflict。由于是64bit的访问方式，根据上文的介绍，我们需要先对half-warp分析，如下图所示：

q shared memory的保存

从上图我们可以清楚的看到每一个half-warp都有2-way的bank conflicts，所以最终的wavefront的数量为2*2 = 4， bank conflicts=2。如下图将该部分单独拿出来，通过ncu分析得到：

q store到shared memory的部分单独抽出来做profile

确实有bank conflicts，不过这个整体时间占比也不高。解决这个问题也很简单，只需要将q_vecs的两个维度调换，让half-warp中的线程连续访问shared-mem。得到的效果如下图：

解了bank confilct后

加载128 * 2 = 256bytes的数据，最少只需要两个wavefronts。所以读到这里，你是不是也可以去优化一个PagedAttention。

K的加载

K和V的加载开始需要block_table，PA的主要思想就是将不同seqs的KV-cache，以Block的方式离散的存放到一个大的Page Table中，来减少显存碎片。不同seqs的KV-cache里token embeddings的对应关系，由block_table来表示，同样序列维由blockIdx.y来获取当前blcok处理的序列。一个warp将负责load一个block对应的KV-cache，PA的Thread-block默认大小是128，4个warp，那么一个thread-block一次迭代将完成BLOCK_SIZE * 4 = 64个token的load和计算。

key_cache: [num_blocks, num_heads, head_size//x, block_size, x]

先看一个warp的数据加载，一个Warp需要load BLOCK_SIZE * HEAD_SIZE / x * x的数据，平均下来是一个thread_group加载一个head_size的数据量（不同于Q，是一个warp加载一个head。）。不同于Q的load，K的加载是直接加载到寄存器上，并没有经过shared mem，主要因为Q*K计算只需要仿存一次，没有复用，所以不需要load到shared mem。那么q为啥load，主要是1. q需要多次复用；2. 如果加载到寄存器，会增大寄存器的使用量，降低occupancy，甚至导致寄存器溢出，大大影响性能。

K的加载
#pragma unroll
      for (int j = 0; j < NUM_VECS_PER_THREAD; j++) {
        const cache_t* k_ptr =
            k_cache + physical_block_number * kv_block_stride +
            kv_head_idx * kv_head_stride + physical_block_offset * x;
        const int vec_idx = thread_group_offset + j * THREAD_GROUP_SIZE;
        const int offset1 = (vec_idx * VEC_SIZE) / x;
        const int offset2 = (vec_idx * VEC_SIZE) % x;

        if constexpr (KV_DTYPE == Fp8KVCacheDataType::kAuto) {
          k_vecs[j] = *reinterpret_cast<const K_vec*>(
              k_ptr + offset1 * BLOCK_SIZE * x + offset2);
        } else {
          // Vector conversion from Quant_vec to K_vec.
          Quant_vec k_vec_quant = *reinterpret_cast<const Quant_vec*>(
              k_ptr + offset1 * BLOCK_SIZE * x + offset2);
          k_vecs[j] = fp8::scaled_convert<K_vec, Quant_vec, KV_DTYPE>(
              k_vec_quant, kv_scale);
        }
      }


这块儿需要将线程的划分和数据划分结合来理解，上文说到一个thread_group负责一个Head的加载（不同于q的load过程），那么一个thread_group迭代NUM_VECS_PER_THREAD次，就完成了一个head的load，head在数据分布上，在倒数第一维和倒数第三维上，所以vec_idx将在x和HEAD_SIZE/2这两个维度上滑动，产生的值分别offset2和offset1，而thread_group_idx 在BLOCK_SIZE上滑动，得到的值为physical_block_offset。这样一个thread_group在x维上连续load global mem，一个warp内的多个thread_group在block_size维上连续load global mem，结合来看，一个warp中的所有线程即可连续加载global mem，总大小为16 * 16 = 256bytes，正好是两个L1或者L2 cache line的大小。最后一个warp还需要在HEAD_SIZE / x维上迭代NUM_VECS_PER_THREAD=HEAD_SIZE/x=16次。关于GQA/MQA的KVCache loading不影响这里的逻辑，PA采用了一种很简单的处理方式，直接把Q的head_idx除以num_queries_per_kv，得到kv_head_idx，因此会有重复读同一个head的block，导致L2cache的命中率比较高，甚至会L2 bandwidth bound，这个问题网上上也有人分析，可以看下面的博客：

Q * K过程

上述加载过程以后，thread_group中的每一个线程将会有NUM_VECS_PER_THREAD个vec数据，共16 * 4 = 64个数据，半个head，一个warp将会有16个token数据，需要和shared_mem中的q_vecs中进行reduce计算，然后在thread_group内同步。具体逻辑如下：

Q*K的dot数据布局

根据序列的长度，以num_warp * block_size的长度迭代，将所有的序列数据的K和Q的head维做reduce，直至当前分块的最长的序列计算完成。最后得到logits值，其存放到shared_mem上，与当前partition序列维相等。这里partition的序列维和shared mem的资源绑定了！

Softmax 计算过程

这个过程在PA上实现的比较简单，分为三步：1. 计算qk的最大值，在Q*K过程中，一个thread_group中的每一个线程已经计算了(end_block_idx - start_block_idx) / NUM_WARPS次迭代的qk_max，在此只需要得到一个block内所有的thread_group的最大值；2. 计算safe softmax的分母；3. logits值除以上一步计算得到的分母。

softmax取最大值时一个warp中各数据走向

如上图所示，为qk_max的求解过程，这个qk_max是start_block_idx -> end_block_idx表示序列的最大值，后面softmax的计算同样是这个范围下，这个操作是不是很熟悉。接着计算safe softmax的分母，先是一个block范围的element-wise操作，接着一个block内的reduce-sum。最后在block内的element-wise，得到num_tokens(end_token_idx - start_token_idx)范围内的softmax。

如果开启了USE_PARTITIONING，需要保存当前分块的max logit和exp_sum，其实就是online softmax中的一个分块的m和l。

V的加载

V的加载的线程划分没有复用K的加载过程，K是一个thread_group加载16bytes的数据，而V的加载是一个thread加载16bytes的数据(单线程最大加载量)。

value_cache: [num_blocks, num_heads, head_size, block_size]
V cache的数据布局
const int64_t physical_block_number =
        static_cast<int64_t>(block_table[block_idx]);
    const int physical_block_offset = (lane % NUM_V_VECS_PER_ROW) * V_VEC_SIZE;
    const int token_idx = block_idx * BLOCK_SIZE + physical_block_offset;
    L_vec logits_vec;
    from_float(logits_vec, *reinterpret_cast<Float_L_vec*>(logits + token_idx -
                                                           start_token_idx));

    const cache_t* v_ptr = v_cache + physical_block_number * kv_block_stride +
                           kv_head_idx * kv_head_stride;
#pragma unroll
    for (int i = 0; i < NUM_ROWS_PER_THREAD; i++) {
      const int row_idx = lane / NUM_V_VECS_PER_ROW + i * NUM_ROWS_PER_ITER;
      if (row_idx < HEAD_SIZE) {
        const int offset = row_idx * BLOCK_SIZE + physical_block_offset;
        V_vec v_vec;

        if constexpr (KV_DTYPE == Fp8KVCacheDataType::kAuto) {
          v_vec = *reinterpret_cast<const V_vec*>(v_ptr + offset);
        } else {
          V_quant_vec v_quant_vec =
              *reinterpret_cast<const V_quant_vec*>(v_ptr + offset);
          // Vector conversion from V_quant_vec to V_vec.
          v_vec = fp8::scaled_convert<V_vec, V_quant_vec, KV_DTYPE>(v_quant_vec,
                                                                    kv_scale);
        }
        if (block_idx == num_seq_blocks - 1) {
          // NOTE(woosuk): When v_vec contains the tokens that are out of the
          // context, we should explicitly zero out the values since they may
          // contain NaNs. See
          // https://github.com/vllm-project/vllm/issues/641#issuecomment-1682544472
          scalar_t* v_vec_ptr = reinterpret_cast<scalar_t*>(&v_vec);
#pragma unroll
          for (int j = 0; j < V_VEC_SIZE; j++) {
            v_vec_ptr[j] = token_idx + j < seq_len ? v_vec_ptr[j] : zero_value;
          }
        }
        accs[i] += dot(logits_vec, v_vec);
      }
    }


V的加载依然是通过block_table找到对应KVCache中各个token的位置进行加载。一个warp加载数据总量依然为HEAD_SIZE * BLOCK_SIZE。physical_block_offset指向BLOCK_SIZE维的一个V_VEC，由lane在NUM_V_VECS_PER_ROW的offset得到。row_idx指向HEAD_SIZE维，由lane在NUM_V_VECS_PER_ROW的倍数得到，这样一个warp的一次迭代就可以连续的访问BLOCK_SIZE * NUM_ROWS_PER_ITER = 16 * 16 * 2 = 512bytes的连续数据块，是一个warp一次request的最大数据块，它是L1或L2 cache line的4倍。经历NUM_ROWS_PER_THREAD次迭代即可加载HEAD_SIZE * BLOCK_SIZE大小的数据块。当然序列长度不一定是BLOCK_SIZE的倍数，所以最后补了一个超过序列长度的补0的操作（这个.....）。

P*V的计算过程
P*V计算过程thread block内各线程的数据走向

P*V计算是在序列维的reduce操作。logits的vec（float类型，size=8）和一次load的v_vec(V_Vec half类型，size=8)进行dot计算，得到值存放在寄存器数值accs上，在本例子中它的大小是8，float类型，具体过程如上图所示。然后所有的warp的相邻的两个线程做shuffle sum的reduce操作，得到一个BLOCK_SIZE的reduce结果。当然最外围还有一个thread-block级别的迭代，都会reduce到accs中。

最终结果的Reduce
对o的值在thread block中做reduce

接着上阶段的计算结果，现在每一个warp的偶数线程都包含NUM_ROWS_PER_THREAD个BLOCK_SIZE加上thread-block级别的外循环上遍历block_table的reduce结果，现在只需要在thread-block中的warps之间做reduce。如上图所以，PA是通过一个for-loop实现这个操作，先把upper warps(iter0是warp2和warp3，iter1是warp1)上的registers值，放到smem上，然后由lower warps(iter0是warp0和warp1，iter1是warp1)与shared mem上结果相加，实现reduce-sum。最后所有的结果都汇集到warp0的偶数线程上，并由warp0将由float转化为目标类型并写出到out_ptr。

PagedAttentionV2的reduce_kernel

上述kernel计算出了各个partitions的结果，这里的reduce_kernel将上面的各个partitions进行reduce。kernel输入的数据结构：

out：[num_seqs, num_heads, head_size];
exp_sum: flashAttention中的l值，[num_seqs, num_heads, max_num_partitions];
max_logits：flashAttention中的m值，[num_seqs, num_heads, max_num_partitions];
tmp_out: 上述kernel输出的各个partitions的输出，[num_seqs, num_heads, max_num_partitions, head_size];
seq_les: 各个序列原始的序列长度，[num_seqs];
max_num_partitions: 最大划分的数目。

依然是blockIdx.x划分head维，blockIdx.y划分序列维，thread-block的大小复用partition计算的kernel，默认大小为128。这个kernel的数据划分和thread划分很简单。整体分为：1. 得到全局（整个序列维）最大的max_logits；2. 矫正各个partition的exp_sum，并计算出正确的全局exp_sum(flashAttention中的全局l)；3. rescale tmp_out中的各个partition，并reduce。关于FlashAttention的公式推导可以参看：

下面详细介绍：

计算全局max_logits

先thread-block级别reduce，将各个partitions的max_logits值reduce到一个block内。然后block内的一个warp做reduce，得到warp内最大值，并通过0号线程，按照warp_idx编号放到shared_mem上。然后各warp同步读取shared_mem，到自己前NUM_WARP个线程寄存器中，进行最后的reduce，得到整个序列的最大logists值，记录为m，每一个partition的max_logist值记录为m_i。

矫正各个partitions的exp_sum

这里的线程操作逻辑和上个阶段相同，同样是先thread-block级别的reduce，再thread-block内的reduce。这里的矫正逻辑如下：

符合定义：x_i，表示第i个分片的输出矩阵块。 \begin{align} e^{m_i -m} * \sum_{x \in x_i} e^{x - m_i} = \sum_{x \in x_i} e^{x - m} \end{align}

for (int i = threadIdx.x; i < num_partitions; i += blockDim.x) {
    float l = shared_max_logits[i];
    float rescaled_exp_sum = exp_sums_ptr[i] * expf(l - max_logit);
    global_exp_sum += rescaled_exp_sum;
    shared_exp_sums[i] = rescaled_exp_sum;
  }
  __syncthreads();
  global_exp_sum = block_sum<NUM_WARPS>(&red_smem[NUM_WARPS], global_exp_sum);
  const float inv_global_exp_sum = __fdividef(1.0f, global_exp_sum + 1e-6f);


对应的代码 float rescaled_exp_sum = exp_sums_ptr[i] * expf(l - max_logit); 可以得到片段x_i 下的正确值，然后进行多级reduce，得到这个序列的exp_sum值，即为\sum_{x \in X}e^{x-m}其中X为全量序列。接着取倒数得到inv_global_exp_sum。

rescale tmp_out并reduce
#pragma unroll
  for (int i = threadIdx.x; i < HEAD_SIZE; i += NUM_THREADS) {
    float acc = 0.0f;
    for (int j = 0; j < num_partitions; ++j) {
      acc += to_float(tmp_out_ptr[j * HEAD_SIZE + i]) * shared_exp_sums[j] *
             inv_global_exp_sum;
    }
    from_float(out_ptr[i], acc);
  }


对应的原理公式如下： \begin{align} \frac{e^{x - m_i}}{\sum_{x \in x_i}e^{x-m_i}} * \sum_{x \in x_i} e^{x - m} * \frac{1}{ \sum_{x \in X} e^{x - m} } &=\frac{e^{x - m_i} * e^{m_i - m}}{\sum_{x \in x_i}e^{x-m_i}} * \sum_{x \in x_i} e^{x - m_i} * \frac{1}{ \sum_{x \in X} e^{x - m} } \\ &= \frac{e^{x - m}}{\sum_{x \in X}e^{x-m}} \end{align} 然后将不同的partiton中rescale后的对应值加和，完成不同partitions之间的reduce，最后得到完整序列输出结果。

参考
