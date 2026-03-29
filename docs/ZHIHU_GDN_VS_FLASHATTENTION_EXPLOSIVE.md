# 为什么 FlashAttention 越做越猛，GDN 却总像“理论赢麻了，工程打不穿”？

这几年如果你关注长序列建模，几乎一定会看到两条路线被反复拿来讨论：

- 一条是以 FlashAttention 为代表的 attention 工程优化路线
- 一条是以 Gated DeltaNet、Delta-rule 这类为代表的线性/状态模型路线

表面上看，后一条路线甚至更诱人。

为什么？因为它的论文叙事实在太有吸引力了：

- 不显式构造完整 attention matrix
- 理论复杂度更线性
- 长序列更友好
- 看起来像是比 attention 更“先进”的下一代方案

但真正到了工程实现层，很多人都会产生一种强烈落差：

**为什么 FlashAttention 越做越快、越做越像工业标准，而 GDN 这类结构却经常给人一种“理论很好，落地好难”的感觉？**

我的答案很直接：

**因为 FlashAttention 优化的是一个 GPU 天生就喜欢的问题，而 GDN 优化的是一个 GPU 天生没那么喜欢的问题。**

说得再狠一点就是：

**FlashAttention 的主战场是矩阵乘，GDN 的主战场是状态。**

而现代 GPU 的整个硬件世界，显然是围着前者建出来的。

## 一、很多人把 GDN 和 FlashAttention 放在一起比较，但两者其实不是一类题

FlashAttention 本质上还是 attention。

它再怎么优化，底层仍然是在做这条主线：

- `QK^T`
- `softmax`
- `PV`

它做的伟大之处，不是换掉 attention，而是把 attention 这个原本非常吃 IO 的东西，重写成了一个**分块、片上、在线归约**的高效实现。

所以 FlashAttention 的优化方向始终非常统一：

- 分块
- 融合
- 降低 HBM 往返
- 提高 Tensor Core 吞吐
- 把 tile 内复用榨干

它本质上是在做什么？

**在不改变 attention 数学定义的前提下，把 attention 越做越像 GPU 最喜欢的 GEMM。**

这是一条极强的优化主线，因为现代 GPU 从硬件到软件生态，几乎都在帮助你把这件事做到极致。

而 GDN 不一样。

GDN / Delta-rule 这类结构，核心不再是构造一张 token-token 关系图，而是：

**沿着时间轴递推一个状态 `state`。**

每个 token 到来时，你都要：

1. 看当前的 `q, k, v`
2. 看 gate 参数
3. 读取旧状态
4. 更新状态
5. 再从新状态中产生输出

问题从这里就彻底变了。

因为它不再是一个“如何高效做矩阵交互”的问题，而成了一个“如何高效维护状态系统”的问题。

这两件事看起来都在做序列建模，实际上对 GPU 的友好程度完全不同。

## 二、FlashAttention 为什么一路都在吃硬件红利

我觉得 FlashAttention 真正可怕的地方在于，它不是简单地“把 attention 写快一点”，而是它的优化方向和 GPU 的天性高度一致。

GPU 喜欢什么？

- 大块并行
- 规则访存
- 高算术强度
- 可以持续投喂 Tensor Core 的矩阵乘

而 FlashAttention 做的，恰恰就是不断让问题往这个方向靠：

- `Q/K/V` 分块
- tile 内矩阵乘
- 在线 softmax 归约
- 减少中间矩阵落盘
- 增强片上复用

也就是说，FlashAttention 的每一步进化，本质上都在增强一件事：

**让 attention 更像一个高质量的矩阵块算法。**

这有多重要？

重要到你几乎可以这么理解：

FlashAttention 的很多优化，不是在逆着硬件做事，而是在顺着硬件的最大偏好做事。

所以它越往后演进，越容易出现这种感觉：

- 硬件在帮它
- 编译器在帮它
- CUTLASS/CuTe/库生态在帮它
- 工程经验也在帮它

这就是为什么 FlashAttention 很容易形成一条持续吃红利的路线。

## 三、GDN 为什么不是“再来一个更强的 FlashAttention”

很多人最容易犯的错，就是以为 GDN 只是“另一个 attention 优化方向”。

不是。

GDN 最大的区别不在于它复杂度写法不同，而在于它把核心对象从“矩阵交互”换成了“状态递推”。

这一换，整个系统瓶颈立刻变了。

### 1. FlashAttention 主打矩阵块，GDN 主打状态递推

FlashAttention 虽然复杂，但说到底，它始终还是在围绕一堆矩阵块做文章。

而 GDN 的中心是 `state`。一旦 `state` 成为中心对象，你面对的就不再只是：

- 矩阵乘够不够快

而是：

- 当前 step 能不能并行
- state 每步要搬多少字节
- state 更新会不会数值失控

这意味着 GDN 的系统约束不是单一的，而是三件事一起压上来。

### 2. FlashAttention 的大敌是 IO，GDN 的大敌是“状态 IO + 递推依赖”

很多人会说，FlashAttention 也很吃 IO 啊。

对，但 FlashAttention 的 IO 问题，本质上是：

**如何避免把巨大的中间 attention matrix 写回 HBM。**

而 GDN 的 IO 问题不一样。

它的问题是：

**每一个 token 都要去碰 state，而且 state 不是只读，它是读完还要更新再写回。**

这比单纯的“读大矩阵”更麻烦，因为它天然和时间递推绑死了。

在这次比赛 workload 里，典型 state 形状类似：

```python
state = [B, 8, 128, 128]
```

别看这个矩阵尺寸不吓人，只要进入 decode，它就会变成真正的主角。因为每个 token 都要：

- 读 state
- 算 state
- 写 state

而单步计算量本身又不厚，所以结果就是：

**GDN decode 经常不是 compute-bound，而是非常典型的 memory-bound。**

这和 FlashAttention 的优化气质完全不同。

### 3. FlashAttention 的低精度更多是在追吞吐，GDN 的低精度先得保证别炸

FlashAttention 当然也有数值稳定性问题，softmax 的 max-trick、在线归约、混合精度累积，一个都不能少。

但 GDN 更难的一点在于：它的误差是递推的。

这意味着只要状态更新尺度稍微失控，就会发生：

- state 爆炸
- 长程误差累积
- 低精度误差被层层放大

所以对 GDN 来说，FP8/FP4 不是一个“换个数据类型”的决定，而是一个“这个状态系统还能不能活”的决定。

这和 FlashAttention 完全不是一种优化心态。

FlashAttention 的低精度更像：

**怎么更猛地吃 Tensor Core。**

GDN 的低精度更像：

**怎么少搬字节，同时别把状态递推搞崩。**

## 四、如果按 decode 和 prefill 分开看，差异会更残酷

### 1. Decode：FlashAttention 还是 attention 工程，GDN 已经变成递推系统工程

FlashAttention 的 decode，虽然也会遇到 KV cache、paged attention、小 batch、memory-bound 等问题，但它的结构核心仍然是：

当前 query 如何与历史 KV 高效交互。

所以它的优化主线依然明确：

- KV layout
- paged cache
- 更高效的 online aggregation
- 分块加载和流水

但 GDN 的 decode 根本不是这回事。

对于类似 `gdn_decode_qk4_v8_d128_k_last` 这种 workload，它的核心更接近：

```text
[128 x 128] × [128]
```

也就是 mat-vec，不是 mat-mat。

结果会怎样？

- Tensor Core 很难吃满
- 算术强度天然偏低
- 单 token latency 极其敏感
- state 读写直接成为中心矛盾

所以 decode 阶段，两者本质上已经不是一类题：

- FlashAttention decode：如何更聪明地读 KV
- GDN decode：如何更聪明地维护 state

### 2. Prefill：FlashAttention 天然矩阵化，GDN 还得先想办法把自己变矩阵化

FlashAttention 的 prefill，几乎可以说是它的黄金舞台。

因为一整段 prompt 一次进来，本来就非常适合：

- 大 tile
- 高并发
- Tensor Core
- 片上 softmax

也就是说，FlashAttention 的 prefill 是：

**原问题天然适合 GPU，只要实现足够好。**

但 GDN 的 prefill 并不天然适合 GPU。

如果你直接按 token 一个个递推，那它依然会：

- 并行度不够
- state 重复读写
- 算术强度很低

所以 GDN prefill 必须先做一件 FlashAttention 不需要做的事：

**先把递推问题改写成 chunkwise recurrence 或 scan 风格问题。**

注意这个顺序非常关键。

FlashAttention 是“先天就是矩阵块问题，再把它实现好”。

GDN 是“先想办法把它改造成块并行问题，然后才有资格谈怎么实现好”。

这就是两者工程难度差异的核心来源之一。

## 五、为什么 FlashAttention 更容易形成生态，而 GDN 更像定制工程

FlashAttention 的另一个强点，是它非常容易形成可复用的优化资产。

原因很简单：attention 的数学主干非常稳定。

无论模型怎么变，它大体还是：

- `QK^T`
- `softmax`
- `PV`

所以很多优化成果都能沉淀成共性基础设施。

但 GDN 的很多优化，很难这么抽象。

因为它强依赖：

- state 的形状和布局
- gate 的具体公式
- 递推更新的实现形式
- prefill 能不能 chunk 化
- state 压缩后的 scale 设计
- correctness 对长程误差有多敏感

所以你会感觉到：

**FlashAttention 的优化像“做出一套越来越通用的工业基础设施”，而 GDN 的优化更像“围绕具体状态系统做深度定制”。**

这也是为什么 attention 生态更容易成熟，而 GDN 往往需要更强的模型-系统协同设计。

## 六、从 Roofline 角度看，两者在追的根本不是同一个上限

FlashAttention 的典型目标是什么？

是不断提高算术强度，减少不必要 IO，把瓶颈从 memory 推向 compute，最后尽量贴近算力屋顶。

所以 FlashAttention 的性能叙事，天然更像：

- 多少 TFLOPS
- Tensor Core 利用率多高
- 离理论峰值还差多少

而 GDN 尤其是 decode，经常从一开始就是低算术强度问题。

以这次 workload 为例，decode 的算术强度大致只有：

```text
AI ≈ 1 FLOP / byte
```

这意味着它离 compute roof 非常远，更像是一个“先把 memory roof 吃满再说”的问题。

所以两者在追的根本不是同一个天花板：

- FlashAttention：追 compute roof
- GDN decode：追 memory roof
- GDN prefill：先靠 chunking 把自己从低 AI 拉起来

这就是为什么 FlashAttention 的讨论常常围绕算力，而 GDN 的 decode 讨论更自然地围绕带宽。

## 七、真正一针见血的差别：一个在优化算子表达，一个在优化状态机制

如果一定要把 GDN 和 FlashAttention 的本质区别再压缩成一句话，我会说：

**FlashAttention 优化的是算子表达，GDN 优化的是状态机制。**

前者的核心问题是：

- 怎么让 attention 这个算子表达更贴近 GPU

后者的核心问题是：

- 状态怎么稳定
- 状态怎么压缩
- 状态怎么递推
- 状态怎么少搬

这就决定了 GDN 的优化天然更分裂，也更难“一条主线打到底”。

你想把 GDN 做好，往往必须同时管好：

- 算法改写
- 内存布局
- kernel fusion
- 量化方案
- 数值稳定

这已经不是“写个更快 attention kernel”那种难度了。

## 八、给工程团队一句最有用的判断

如果让我给工程团队留一句最实用的话，我会这么说：

### FlashAttention 是什么问题

- 本质仍然是 attention
- 主任务是减少 IO、增强矩阵块复用、吃满 Tensor Core
- 它是在不断把问题推向 GPU 的甜点区

### GDN 是什么问题

- 本质是状态递推
- 主任务是减少 state traffic、缓解时间依赖、守住数值稳定
- 它是在系统约束下，努力把理论优势兑现成可运行的性能

所以我会把这个结论说得非常绝对：

**FlashAttention 越做越快，是因为它一直在做 GPU 最擅长的事。GDN 难做，是因为它逼着 GPU 去做一件自己没那么擅长的事。**

## 九、结论：GDN 不是 FlashAttention 的平替，它难在另一个维度

最后回到最开始的问题。

为什么 FlashAttention 越做越猛，而 GDN 却总给人一种“理论赢麻了，工程打不穿”的感觉？

因为两者压根不是在优化同一种对象。

FlashAttention 的优势在于：它虽然复杂，但始终停留在 GPU 最喜欢的矩阵块世界里。于是硬件、编译器、库生态、工程经验，都会不断帮助它。

而 GDN 的难点在于：它把问题从“矩阵交互”换成了“状态递推”。于是你必须同时面对：

- 时间维依赖
- 状态读写带宽
- 长程数值稳定

所以如果一定要用一句话收尾，我会写：

**FlashAttention 难在把 attention 做到极致，GDN 难在它根本不是一个天然适合 GPU 的 attention 问题。**

这也解释了为什么 GDN 的论文优势，不会自动变成工程优势。它当然可能更适合长序列，但前提是你真的把状态系统这件事做对了。

而这件事，比“再做一个更快的 attention kernel”，难多了。
