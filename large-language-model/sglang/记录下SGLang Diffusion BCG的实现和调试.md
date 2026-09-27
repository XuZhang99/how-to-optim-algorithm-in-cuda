> 欢迎关注 SGLang，以及我的 CUDA 学习笔记和 AI Infra SKILLS 仓库：
>
> SGLang：https://github.com/sgl-project/sglang
>
> CUDA 学习笔记：https://github.com/BBuf/how-to-optim-algorithm-in-cuda
>
> AI Infra SKILLS：https://github.com/BBuf/AI-Infra-Auto-Driven-SKILLS

# 0x0. 前言

前两个月和Agent一起coauthor了一些 SGLang Diffusion 的 BCG（Breakable CUDA Graph）开发和模型验证，这里记录一下 BCG 的实现，以及在 Prompt Padding、Graph Replay 和性能测试中碰到的几个问题。本文为了保证准确性，除了数据统计之外是我纯手打的，AI含量已经是最低了，也耗时很久才打完。

接下来BCG的实现对应 SGLang `96bfd247`，也可以直接看main分支。后续的 SANA-Video 的BCG相比于eager的加速数据来自 #35729（https://github.com/sgl-project/sglang/pull/35729） 的测试。

# 0x1. SGLang Diffusion 中的 BCG 实现

Diffusion 生成图片或者视频时，需要重复执行多次 DiT forward。每次 forward 里的 projection、norm、RoPE、residual、MLP 等操作可能会调用很多耗时很短的 kernel，如果 CPU launch 跟不上，kernel 之间就会出现空隙（叠甲：这个是分模型的）。以 SANA1.5 为例，在 H200 上看它的 Eager Torch Profile，GPU busy 只有 28.5%，开启 BCG 后可以达到 93.3%，主要减少的就是这部分 launch 开销。

然后问题在于Diffusion模型里面有些操作不方便直接放进 CUDA Graph，例如 varlen attention 需要根据当前请求的 mask 生成 `cu_seqlens` 和 indices，部分通信和动态分支也需要在运行时处理。因此 SGLang 在公共 DiT attention 入口加了 `@eager_on_graph`，capture 到这里时先结束当前 graph，使用 Eager 执行 attention，然后继续 capture 后面的操作。这样一个 forward 就被分成了多个 graph segment，如下图所示。

![DiT 的 BCG Capture 和 Replay 流程](https://files.mdnice.com/user/59/ee051b68-267f-4b45-82de-31bc3c3e06ca.png)

后续执行 denoising step 时，按 `segment 0 → eager attention → segment 1 → …` 的顺序 replay 就可以了，模型的 forward 代码不需要为此拆成多个函数。

为了判断当前输入能使用哪个 graph，runner 会根据 kwargs 生成一个 signature。Tensor 记录 shape 和 dtype，Python 的 int、bool、string 等常量记录具体值，list、tuple、dict 则递归处理，其他对象还会按类型和 identity 区分。因此不同 prompt 经过 padding 后，如果 shape、dtype 以及其余参数相同，就可以复用同一个 graph。

每次 replay 前，先把当前输入拷贝到 capture 时分配的固定 buffer 中，然后执行 graph，简化代码如下：

```python
for buf, live in zip(entry.static_leaves, live_leaves):
    buf.copy_(live, non_blocking=True)

entry.graph.replay()
return clone(entry.output)
```

注意最后的 `clone`，graph 的 output buffer 会在下次 replay 时被写入，CFG 的正负分支也可能复用这块 buffer。如果直接返回原 buffer，后一个分支执行完之后，前一个分支的结果就可能被覆盖，所以这里需要复制一份输出。

目前 BCG 只在 warmup 阶段 capture，server ready 之后根据 signature 查找对应的 graph，没有匹配到就直接用 Eager 执行。使用时还要注意，分辨率和视频帧数需要与 warmup 一致，例如 `1024×1024` 的 graph 不能用于 `1280×768`，视频模型里面 17 帧的 graph 也不能用于 121 帧。Prompt 长度可以通过 padding 处理，下面单独介绍。

# 0x2. 不同 Diffusion 模型的 Prompt Padding

以 SANA 模型为例，我们可以把 19-token 和 47-token 的 prompt 都补到 64，新增位置的 mask 设为 0，不参与 attention。这样两个输入的 shape 就一致了，可以复用同一个 graph。

```text
19 tokens: [real ×19 | masked pad ×45]
47 tokens: [real ×47 | masked pad ×17]
```

通用 padder 会在有显式 attention mask 的情况下补齐长度，默认 buckets 是 `64、128、256、512、1024`。如果超过最大 bucket，就保留原来的长度，warmup 没有 capture 过这个 shape 的话，使用 Eager 执行。

Qwen-Image 还需要同步处理 mask、text RoPE cache 和 `txt_seq_lens`，只补 embedding 会导致这些字段的长度不一致。其中 `txt_seq_lens` 也会设成 bucket，避免这个 host 常量随着 prompt 长度变化，真实文本的范围由 mask 表示。

> 例如我们把 19 个 token 补到 64，除了 embedding，还得给这 64 个位置准备好 mask 和文本位置编码，否则一个字段是 64，另一个还是 19，就对不上了。`txt_seq_lens` 也写成 64，因为这个数字会影响选择哪个 graph。至于哪些位置是真实文本，由 mask 来区分，前 19 个位置是 1，后面补出来的位置是 0。

Qwen-Image 在换 prompt 后，还需要重新计算 varlen attention 的 metadata。原因是 static mask buffer 的地址不变，但内容已经更新了，如果只使用 `data_ptr()` 作为 cache key，就会复用旧的 `cu_seqlens`。实现中用 `DynamicVarlenMaskMeta` 处理这个问题，每次 replay 的第一个 attention break 根据当前 mask 生成 metadata，后续 block 复用这份结果，下一次 replay 时再更新。

> 这里的 metadata 记录的是 attention 实际要读取哪些位置、有效序列有多长。假设第一次 prompt 有 19 个 token，第二次有 47 个，两次都补到 64，并且使用同一块显存，`data_ptr()` 自然也一样。但里面有效的 token 数已经变了，所以这些长度和位置数据得重新算。每次 replay 算一次就可以了，后面的 attention 层再复用这份结果。就是第一层之前重新算好就行，观察到这个开销其实不大。

下面是几种模型的 padding 方式。

![SANA、Qwen-Image、Z-Image 和固定文本长度模型的 Padding 处理](https://files.mdnice.com/user/59/d3208e4a-0b35-40a9-9eab-0baa1b246258.png)

Z-Image 不能直接使用上面这种 padding。最初把不同 caption 补到同一个 bucket 后，BCG 和 Eager 输出的 PSNR 只有 21.24 dB，生成的图片有明显差异。逐层对比之后发现，第一处差异出现在 `context_refiner.0`，也就是第一个 caption self-attention。

这是因为 Z-Image 原本就会把 caption 补到 32 的倍数，其中的 learned pad token 会作为 register 参与 attention。如果继续补到更大的 bucket，参与 attention 的 token 数量就变了，结果也会变化。#34210（https://github.com/sgl-project/sglang/pull/34210） 的处理是保留输入的 native caption length，相同长度的输入可以复用 graph，没有预热过的长度使用 Eager，修改后输出与 Eager 完全一致。

> 注意这里补出来的 token 和前面 SANA 的 padding 不一样，它们是模型训练过的向量，会参与 attention 计算。例如模型原本补齐后有 32 个 token，我们为了复用 graph 再补到 64，就多了 32 个参与计算的位置，生成结果也会受影响。所以这里保留的是模型原本已经补齐的长度，不是完全不做 padding。我也不知道这里还叫padding是不是准确的？

MiniMax-H3 则需要考虑 packed sequence。它把 text、video/image 和 audio 放在同一个 packed sequence 中，可以对 prompt embedding 做 padding，但不能扩充主序列 `x`，否则会改变 sequence-parallel 的 row partition 和 GEMM shape，不能保证计算结果与 Eager 完全一致。所以除了 text bucket 相同，还要求主 packed sequence 在同一个 64-row alignment group 内，跨组的请求使用 Eager。

> packed sequence 可以先理解为把文本、图像/视频和音频的数据接在一起。这里不扩大 `x`，是因为多加一些行之后，各张 GPU 分到哪些行、矩阵乘法的尺寸都可能变化，浮点计算结果也可能有差异。单看 64 行对齐这一项，例如 100 行和 120 行都会对齐到 128 行，130 行则要对齐到 192 行。前两种在 text bucket 等其他条件也相同时可以复用 graph，后一种就需要另一张 graph，没有预热过的话使用 Eager。

LTX-2/LTX-2.3、LongCat-Image 和 SANA-Video 的文本编码已经固定长度，分别是 1024、512 和默认 300。不同长度的 prompt 进入 DiT 时，text shape 已经一致，不需要再次补齐。

这里 SANA-Video 原本也会经过通用 padder，把 `[1, 300, 2304]` 的输入继续补到 512，导致每层 cross-attention 多处理 212 个位置，也多 capture 了一组不需要的 graph。#35729（https://github.com/sgl-project/sglang/pull/35729） 增加了专用处理，确认模型类型和输入长度为 300 之后，直接返回原输入。如果用户修改了 `max_sequence_length`，再回到通用 padding。因此默认配置下不需要额外设置 `--bcg-text-buckets 300`。

# 0x3. BCG 开发中碰到的几个问题

## 0x3.1 Z-Image Graph Replay 出现非法访存

BCG 的 attention 在 graph 外执行，capture 时 attention 输出 tensor 的地址会被后一个 graph segment 使用。Replay 时 attention 会生成新的输出，需要把结果 `copy_` 到 capture 时的 buffer 中，再执行后面的 segment。

早期实现把这份 eager output 转成了 weak-ref。由于它是在 graph 外分配的，没有强引用后可能被释放，后一个 segment 读取这个地址时就会出现非法访存。Z-Image-Turbo 上遇到的 segfault 是这个原因，#30584（https://github.com/sgl-project/sglang/pull/30584） 将 eager break output 改回强引用，并增加了 CUDA 回归测试。

Z-Image 的 RoPE 和 attention metadata 等 cache 也有类似问题。这些 cache 原来只保存一份，capture 新 bucket 时会替换旧值，但之前 capture 的 graph 仍然会读取旧 tensor 的 device address。处理方法是在 active capture 期间保留这些 cache tensor，避免它们在 graph 还需要使用时被释放。

## 0x3.2 LTX-2 的 Warmup Shape 和真实请求不一致

LTX-2 使用通用视频 warmup 时，为了减少启动时间只跑 17 帧，但真实请求是 121 帧，两者的 shape 不一致，无法复用 graph。另外，warmup 会自动构造一张 synthetic image，LTX-2 因此执行 image-conditioned 分支，这个分支的 graph 也不能用于纯 T2V 请求。

还有一个调用路径的问题，LTX-2 的 two-stage denoise 直接调用 `step.current_model(...)`，没有经过通用 `DenoisingStage` 的 BCG hook。因此即使 model 已经加到 allowlist，实际执行时仍然不会调用 runner。这几个问题的修改可以看 #33885（https://github.com/sgl-project/sglang/pull/33885）。

如果启动日志里已经有 `captured`，实际请求却没有使用 BCG，可以先检查 model call 是否经过 runner，再对比 warmup 和真实请求的帧数、分辨率以及 conditioning 是否一致。

## 0x3.3 SANA 的 Signature 生成开销

SANA 接入 BCG 时，`predict_noise` 每次 forward 都会构造一个包含 72,000 个元素的 nested `None` list，作为 `mask_strategy` 传给 DiT。实际上没有 DiT 实现读取这个参数，只是通过 `**kwargs` 接收了它。

Eager 下构造这个 list 大约需要 1.1 ms，BCG 还需要递归遍历整个 list 来生成 signature，导致 denoise 从 0.67 s 增加到 2.63 s。这个开销发生在 Python 侧，看 GPU kernel 的耗时不容易发现，需要同时检查生成 signature 的过程。

#33989（https://github.com/sgl-project/sglang/pull/33989） 删除了这个无用参数。该 PR 在 H200、1024² 配置下测试，Eager denoise 是 699.2 ms，修改后的 BCG 是 408.1 ms，端到端时间从 0.821 s 降到 0.608 s。

## 0x3.4 GLM-Image 精度对比中的随机性

GLM-Image 在 DiT 前还有一段 sampled AR prior，使用了 `do_sample=True`。如果 Eager 和 BCG 分别生成的 prior 不同，即使 DiT 计算结果一致，最后的图片也可能不同。

初始 PR 给 prior 接上了 request seed，并额外做了一次 same-prior replay，即先保存采样结果，再让 Eager 和 BCG 使用同一份 prior，得到的两张图片每个像素值都相同。这里需要注意检查 DiT 之前的随机过程，带 prompt rewrite 或随机 conditioning 的 pipeline 也可以用保存中间结果的方式做对比。

# 0x4. BCG 性能测试结果

下面是初始 PR #27436（https://github.com/sgl-project/sglang/pull/27436） 中的部分 B200 测试结果，表里统计的是 warmup 之后的 denoise latency。

| 模型，512² | Eager | BCG | 加速 |
| --- | ---: | ---: | ---: |
| Qwen-Image | 6.48 s | 2.45 s | 2.64× |
| Qwen-Image-2512 | 6.21 s | 2.44 s | 2.55× |
| GLM-Image | 1.100 s | 0.878 s | 1.25× |
| Ideogram-4 | 1.564 s | 0.916 s | 1.71× |

我们看一下 SANA 的 Profile，5 个 profiled timesteps 中，runtime launch 从 8,412 次减少到 132 次，图中 kernel 之间的空隙也明显减少了。

![SANA1.5 在 H200 上的 Eager 与 BCG Profile](https://files.mdnice.com/user/59/1f189855-e16c-45b2-ada3-5d945280e36d.png)

BCG 的收益也和分辨率有关。LTX-2 在 768×512×121、2×H200 CFG parallel 配置下，GPU busy 从 27.9% 提升到 96.2%；换成 1920×1088 后，Eager 已经有 96.8% 的 GPU busy，BCG 的端到端差异只有约 0.2%。这种情况下 launch 开销占比已经很小，需要考虑 GEMM、attention 或者 kernel fusion 的优化。


# 0x5. BCG 启动和日志检查

以 SANA1.5 为例，可以用下面的命令启动 BCG：

```bash
python3 -m sglang.multimodal_gen.runtime.entrypoints.cli.main serve \
  --model-path Efficient-Large-Model/SANA1.5_1.6B_1024px_diffusers \
  --num-gpus 1 \
  --enable-breakable-cuda-graph \
  --warmup-resolutions 1024x1024 \
  --bcg-text-buckets 64 128 256 512 1024 \
  --enable-torch-compile false
```

注意文中版本开启 BCG 后会跳过 `torch.compile`，也会关闭 Cache-DiT。做 Eager 和 BCG 性能对比时，需要显式设置两边的 compile 和 offload 参数，`--performance-mode speed` 的默认行为改过，直接使用旧命令可能导致测试配置不一致。

启动后可以先看日志里有没有 `[Diffusion BCG] captured`，然后发送几个长短不同的 prompt，检查是否出现 `serving signature MISSED`、`capture failed` 或者 `Falling back to diffusers backend`。正常情况下，warmup 和每次请求后的累计 capture 数量应该保持一致，例如 `[5,5,5,5,5]`。如果所有请求都在使用 Eager，这个数量也不会变化，所以需要同时看 miss 日志。


相关代码在 diffusion BCG runner 和同目录的 model-specific padder 中，感兴趣可以看一下：

https://github.com/sgl-project/sglang/blob/96bfd2476c40bc575d87fd22c8508ece7c199614/python/sglang/multimodal_gen/runtime/breakable_cuda_graph/runner.py
