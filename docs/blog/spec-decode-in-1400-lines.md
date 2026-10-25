# 在 1,400 行的推理引擎里实现异步调度和投机解码

代码：[yczhou25/nano-vllm-spec](https://github.com/yczhou25/nano-vllm-spec)。基于 [nano-vllm](https://github.com/GeeeekExplorer/nano-vllm)（Xingkai Yu 用约 1,400 行 Python 从零写的 vLLM），加了异步调度、n-gram 和小模型两种投机解码、自适应开关，以及一套在 CPU 上就能跑的测试。引擎改动 11 个文件、新增 522 行，测试 1,079 行。

一句话结果：Qwen3-8B 用 Qwen3-0.6B 打草稿，在一张 A40 上，单请求代码编辑的解码吞吐从 33.4 tok/s 提到 96.4 tok/s（2.9 倍，k=6 时 3.3 倍），聊天 1.8 倍；8 并发时代码编辑 2.1 倍。每种模式的贪心输出都和 HuggingFace transformers 逐 token 一致。

下面按"为什么做、怎么做、怎么证明它是对的、数据说了什么、数据抓出来的一个设计 bug"的顺序写。只讲取舍，细节在仓库的 [设计说明](../spec-decode-design.md) 里。

## 为什么是这两样

vLLM、SGLang 这些引擎把异步调度和投机解码当核心卖点，原因是同一个：大模型 decode 每步每条序列只出一个 token，batch 小的时候 GPU 的时间主要花在读权重和 KV cache 上，算力大部分空着。

- **异步调度**填的是 CPU 的空隙：原来的 `step()` 是调度、准备输入、跑 GPU、等结果、后处理串行执行，CPU 做调度时 GPU 闲着。
- **投机解码**填的是 GPU 的空隙：先猜几个 token，让目标模型一次前向把它们全验一遍，猜对几个就一步出几个，多算的几个位置几乎不花时间。

nano-vllm 的好处是改动范围可控：调度器、块管理器、输入准备各一个文件，每一处改动都能说清楚为什么。坏处是它原来几乎没有测试，而这两个功能的 bug 都是"输出看起来正常、KV cache 里有脏数据"这一类，肉眼看不出来。所以第一件事是先写测试，再改引擎。

## 异步调度：往前看一步就够

做法是第 k 步发射到 GPU 之后不等它跑完，先回头处理第 k-1 步的结果，然后马上调度第 k+1 步，让 GPU 上始终排着下一步的工作：

```
step():
    seqs = schedule()            # 第 k 步；第 k-1 步采样出的 token 还在 GPU 上
    out  = run_async(seqs)       # 发射第 k 步，立刻返回
    batch = commit(seqs)         # 推进 KV 进度，记下"在途 token"
    postprocess(prev_batch, prev_out.result())   # 等第 k-1 步，追加 token、判断结束
```

三个要点：

1. **在途 token。** 调度第 k 步时，第 k-1 步采样出的 token 还没回到 CPU。每条序列记 `num_inflight`（几个 token 在途）和 `inflight_row`（它在上一步输出里的行号），decode 的位置和长度按"已确认 + 在途"算，输入 token 直接在 GPU 上从上一步的输出里取（`torch.where(rows >= 0, last_token_ids[rows], ids)`），不经过 CPU。
2. **后处理拆成两半。** `commit` 在发射后立刻推进 `num_cached_tokens`，这样下一次调度能接着排 chunked prefill 的下一段；`postprocess` 在结果回来后做块哈希（prefix cache）、追加 token、判断结束。
3. **结束晚一步。** 碰到 EOS 的序列下一步已经被调度了一次，结果直接丢掉。这一步的浪费换掉的是每步的同步等待，vLLM V1 的 `AsyncScheduler` 是同样的取舍。

为什么只往前看一步：看得更远，在途 token 会变多，抢占、结束和块分配都要按多个在途 token 处理，收益却很小。CPU 只要比 GPU 快，一步就能把 GPU 填满。

数据也印证了这一点：Qwen3-0.6B 上吞吐 +10%，Qwen3-8B 上在 ±2% 以内测不出来。异步调度省掉的是每步固定的几毫秒 CPU 工作，相对 0.6B 的一步很大，相对 8B 的一步很小。

## 投机解码：形状统一是第一原则

### n-gram 草稿

最便宜的猜法是 prompt lookup：在已有文本里找和结尾相同的片段，把它后面跟着的内容当草稿。代码修改、摘要、RAG 这类输出大段复述输入的任务命中率很高。

```
schedule():    每条 decode 序列：草稿 d1..dk = ngram(序列)，预留 k+1 个位置的块
run():         输入 [t, d1..dk]，位置 L-1..L+k-1，一次前向得到 k+1 行 logits
               拒绝采样：接受前 a 个草稿，再采一个，共 a+1 个 token
postprocess(): 追加 a+1 个 token，num_cached_tokens 回退到 L+a，只给 KV 有效的块做哈希
```

取舍在三处：

- **所有序列都是 k+1 个 query。** 形状统一才能继续用 `flash_attn_with_kvcache`（q 是 `(B, k+1, H, D)`，causal 掩码按右下角对齐）和按序列数抓的 CUDA graph。代价是没猜中的序列也算 k+1 个位置；vLLM 用 varlen 注意力支持每条序列草稿数不同。在 1,400 行里，统一形状是对的选择。
- **拒绝采样对 one-hot 提议是精确的。** 草稿是确定性的，提议分布是 one-hot，标准投机采样的接受概率 `min(1, p/q)` 就退化成 `p(d)`，残差 `max(0, p-q)` 就是把 d 的概率置零再归一化。输出分布和一个一个采样完全一样；贪心时只在草稿等于 argmax 才接受，结果和不开投机解码的贪心一致。
- **被拒绝的草稿留在 KV 里的脏数据不用清。** 它们的位置都在下一步要写的范围里，一定先覆盖再读。块哈希只覆盖 KV 有效的位置，所以脏数据进不了 prefix cache。多分配的块也不回收：下一步需要的块数一定不少于这一步。

### 小模型草稿

n-gram 在聊天上接受率只有 5%。真正通用的办法是用同一家族的小模型打草稿（Qwen3-0.6B 给 Qwen3-8B）。验证、拒绝采样、块记账全部复用上面的路径，只换草稿来源：

- **两套 KV cache，同一张块表。** 草稿模型有自己的 KV cache，块数和目标模型相同、块 id 共用，序列的 `block_table` 同时索引两套 cache，prefix cache 命中时两边一起命中。代价是 Qwen3-0.6B 每 token 的 KV 是 115 KB，8B 是 147 KB（两者都是 8 个 KV 头、head_dim 128，只差层数 28 对 36），草稿 cache 几乎让 KV 内存翻倍。这是小模型草稿相对 n-gram 的主要成本，后面那个 bug 也和它有关。
- **草稿取 argmax，采样器不用改。** 提议分布还是 one-hot，`RejectionSampler` 原样精确。vLLM V1 的 draft-model / EAGLE 路径现在也是这么做的（`draft_probs=None`）。代价是温度采样下接受率比"从 q 采样、按 min(1, p/q) 接受"低一些，好处是不用存 `(B, k, V)` 的草稿概率。
- **草稿 cache 落后一个 token。** 草稿模型每步只给前 k-1 个草稿算了 KV，全部接受时最后一个位置在草稿 cache 里是空的。下一步草稿模型的第一个输入取最后两个 token，把位置 L-2 重算一次就补上了；这个位置所在的块晚一步再哈希，否则别的序列 prefix cache 命中它时草稿模型会读到一个没写过的位置。
- **k 步草稿不回 CPU。** 草稿模型跑 k 步（第一步 2 个 query，之后每步 1 个，分别抓 CUDA graph），每步 argmax 直接写进目标模型输入的草稿位。

### 和异步调度合并

难点只有一个：异步调度下，调度第 N+1 步时第 N 步还在 GPU 上，CPU 不知道它接受了几个草稿，也就不知道序列现在多长。下一步的位置、slot、草稿模型的输入全取决于一个还没回来的数。

解法是把"在途"从确定的数改成上界：decode 步记 `num_inflight += 1 + k`，只用于两处判断（块表够不够、要不要停）；真实的 KV 进度改在 `postprocess` 里按接受数推进。所有具体位置都在 GPU 上从上一步的输出里数出来（接受的 token 后面补 -1，`(output >= 0).sum()` 就是实际加了几个）。n-gram 版和异步调度仍然互斥：n-gram 要在 CPU 上查上一步采样的 token，而异步调度的意义就是不等它回来。

## 怎么证明它是对的

这类改动的 bug 不在输出里，在 KV cache 里：写错一个 slot，输出可能还是对的，直到某个块被 prefix cache 共享给另一条序列。所以测试的核心不是比输出，是**检查每一次 KV 的写和读**。

`tests/engine_sim.py` 是一个随机模拟器：用真实的 `LLMEngine.step`、调度器、块管理器和输入准备跑随机负载（chunked prefill、prefix cache、抢占、异步、两种投机），模型换成假的。假模型像注意力层一样读全局 context（slot、context_lens、块表），维护自己的假 KV cache，每次调用核对输入 token、位置、context_len，按 slot 写 KV，再把 context 内每个位置读一遍核对。假草稿模型是一个可调用对象，直接塞给真正的 `ModelRunner.propose`。每个请求的输出都必须和不做任何 batching 的逐 token 参考结果完全一致；每个登记到 prefix cache 的块，KV 必须和它的 token 对得上。它在 CPU 上就能跑（flash-attn 和 triton 用桩替掉），所以 GitHub Actions 每次 push 都跑，默认 3,673 个用例。

光有测试不够，还要知道测试抓不抓得住 bug。每个阶段做完我都往代码里注入 bug（拒绝后不回退 `num_cached_tokens`、被拒草稿所在的块也做哈希、草稿没传给其他 TP rank、在途只记 1 个 token 而不是 1+k……），看有多少用例失败。六轮下来注入了 64 种，60 种被抓到，剩下 4 种推下来都是等价变异（比如抢占后不清某个标记，重新 prefill 时反正会重设）。有一次注入一个保护条件没有任何用例失败，推下来发现它在一步流水线里根本走不到，于是把它删了。

GPU 上另有 18 个测试：六种引擎配置（同步、异步、n-gram、草稿模型、异步 + 草稿模型、自适应）的贪心输出和 transformers fp32 的 teacher-forcing 对比，都在 0.5 个 logit 以内。

## 数据说了什么

一张 A40，bf16，CUDA graph 开，目标 Qwen3-8B，草稿 Qwen3-0.6B。吞吐算整个 run（prefill + decode），单位 tok/s；括号里是相对同一行基线的倍数和草稿接受率。edit 是让模型给源文件加 docstring 后原样输出（输出复述输入），chat 是开放问答。完整表格（含 k=2、异步、T=0.6）在 README 里。

| 负载 | batch | 基线 | n-gram k=4 | 草稿模型 k=4 |
|---|---|---|---|---|
| edit | 1 | 33.4 | 94.3（×2.8，0.50） | 96.4（×2.9，0.88） |
| | 8 | 194.7 | 404.4（×2.1，0.52） | 404.3（×2.1，0.86） |
| | 32 | 592.7 | 923.1（×1.56，0.51） | 859.0（×1.45，0.85） |
| chat | 1 | 33.8 | 40.0（×1.18，0.05） | 59.4（×1.76，0.41） |
| | 8 | 250.1 | 237.2（×0.95，0.05） | 346.5（×1.39，0.41） |
| | 32 | 878.4 | 674.6（×0.77，0.05） | 965.3（×1.10，0.40） |

- **k 跟着接受率走。** edit 接受率 0.85–0.93，k 越大越好，batch 1 时 k=6 到 109.0 tok/s（×3.3）；chat 接受率 0.4–0.55，batch 32 时 k=2（1019.8）比 k=4（965.3）快，因为没猜中的位置也要算。
- **n-gram 是要老实展示的最坏情况。** 代码编辑 ×2.8，不要草稿模型、不多占 KV 内存；聊天接受率 0.05，batch 8 以上反而变慢。
- **温度采样不花钱。** T=0.6 和贪心几乎一样，说明拒绝采样没有额外代价。
- **batch 越大收益越小**，因为目标模型逐渐变成算力受限，多算的 k 个位置不再免费。这也是下一节的起点。

## 一个被数据抓出来的设计 bug

投机解码在小 batch 下最划算，所以我加了一个开关 `speculative_disable_by_batch_size=n`：同时运行的序列超过 n 条就关掉草稿，GPU 反正已经忙了。CPU 上 3,000 多个用例全过，注入的 bug 也都抓到了。

A40 上一跑，batch 32 关掉草稿后比完全不投机还慢：代码编辑 450 对 593 tok/s（×0.76），聊天 746 对 878（×0.85）。

原因是第一版为了让草稿模型的 KV cache 不掉队，不带草稿的步仍然让草稿模型跑一次（2 个 query）。我以为这是"参数量 7% 的小模型跑一步"，忽略了这一步要读草稿模型的整个 KV cache，而前面算过，0.6B 每层的 KV 和 8B 一样大，28 层对 36 层。edit 的 prompt 更长，慢得也更多（每步多 17 ms 对 6.5 ms），和"读 KV"的解释一致。

修法是让草稿 cache 掉队：不带草稿的步完全跳过草稿模型，每条序列记下草稿 cache 覆盖到哪（`num_draft_cached_tokens`）；恢复投机的那一步，草稿模型先补齐再打草稿。补齐仍然保持形状统一：所有序列都算最后 m 个 token（m = batch 里最大的缺口），已经在 cache 里的位置 slot 置 -1（算了但不写），比 m 短的序列前面补 0。正常投机的步缺口是 1 或 2，走原来的 2-query CUDA graph；只有刚从"关草稿"切回来的那一步 m 更大，走 eager 前向。异步调度下在途的步如果不带草稿，缺口还要加上在途 token 数，补齐的输入在 GPU 上从 CPU 已知的尾巴和在途输出里 gather 出来。

模拟器相应加了检查（不带草稿的步不许准备草稿输入；补齐步逐位置核对位置、slot、token；缺口有没有补全靠假草稿模型读 cache 时核对），注入 12 种 bug 抓到 11 种。复测结果：batch 32 关草稿时代码编辑 578 对 591（×0.98），聊天 875 对 877（×1.00），15–24% 的损失没了。

更要紧的是复测顺带说明阈值定错了：这张卡上 8B 在 batch 32 仍是访存受限，草稿 k=4 一直开着才是最快的（×1.45 和 ×1.10），"超过 8 条就关"等于白丢加速。阈值应该定在目标模型变成算力受限的地方，更好的开关是实测接受率：聊天上 n-gram 只有 0.05 该关，模型草稿 0.4–0.85 该开。这是下一步。

## 和 vLLM 的对应关系

- 异步调度：vLLM V1 的 `AsyncScheduler` 用 output placeholder 表示在途 token，model runner 保留上一步的 `sampled_token_ids` 作为下一步的输入。这里的 `num_inflight` / `inflight_row` 是同一个思路的简化版，只往前看一步。
- 投机解码：vLLM 用 varlen 注意力支持每条序列不同的草稿数，这里统一 k+1 个 query 换取 CUDA graph 和 `flash_attn_with_kvcache` 不变；草稿 argmax、`draft_probs=None` 的拒绝采样和 vLLM V1 一致；EAGLE 草稿头没做。
- 两套 KV cache 共用块 id 是 vLLM 的做法，内存代价也一样。

## 还没做的

- 按接受率动态开关和调 k（上面的教训）。
- 从草稿模型的分布采样草稿，按 `min(1, p/q)` 接受：温度采样下接受率更高，要多存 `(B, k, V)` 的 q。
- EAGLE-3 草稿头；n-gram 查找搬到 GPU 上以便和异步调度合并；张量并行的异步 + 草稿路径只在 CPU 上推演过，还没在多卡上跑。

代码和每一步的设计说明、变异测试表、原始 benchmark 行都在仓库里：[yczhou25/nano-vllm-spec](https://github.com/yczhou25/nano-vllm-spec)。
