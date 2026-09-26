source: https://docs.mthreads.com/s4000/s4000-doc-online/introduction

# AIGC 时代训推一体 全功能元计算卡

## 产品特点[](https://docs.mthreads.com#产品特点)

MTT S4000 是基于摩尔线程曲院 GPU 架构打造的全功能元计算卡，为千亿规模大语言模型的训练、微调和 推理进行了定制优化，结合先进的图形渲染能力、视频编解码能力和超高清 8K HDR 显示能力，助力人工智能、图形渲染、多媒体、科学计算与物理仿真等复合应用场景的计算加速。

### 全新升级的曲院架构[](https://docs.mthreads.com#全新升级的曲院架构)

- 第三代 MUSA 核心，配备新一代 Tensor 核心，提供面向大语言模型的 AI 算力及丰富的计算格式，包括 FP64 / FP32 / TF32 / FP16 / BF16 / INT8 等;
- 自研的 MTLink 支持多卡互联，助力千亿大语言模型的分布式计算加速;
- 增 强的硬件虚拟化能力，同时支持 GPU 核心和视频处理核心的硬件切分与隔离;
- 增强的安全引擎，支持 TEE 与国密标准。

#### CUDA 兼容[](https://docs.mthreads.com#cuda-兼容)

得益于全新的曲院架构和 MUSA 软件栈的完备性，用户使用 摩尔线程移植工具 musify 可以自动转化并编译 CUDA 代码为 MUSA 代码，将基于 CUDA 开发的程序运行在 MTT S4000 上。

#### 云原生[](https://docs.mthreads.com#云原生)

MTT S4000 针对智算中心需求进行优化，凭借摩尔线程虚拟 化 GPU 技术、容器运行时技术和 K8S 生态融入技术，全面支 持云端虚拟化与容器化 GPU 的使用和调度需求，可以实现灵 活的硬件和软件切分与隔离，助力算力在云端的高效利用。

## 全面加速 AIGC 时代计算任务 [](https://docs.mthreads.com#全面加速-aigc-时代计算任务-)

### 大语言模型计算加速[](https://docs.mthreads.com#大语言模型计算加速)

MTT S4000 全面支持大语言模型的预训练、微调和推理服务，MUSA 软件栈专门 针对大规模集群的分布式计算性能进行了优化，适配主流分布式计算加速框架， 包括 DeepSpeed， Colossal AI，megatron，FlagScale 等，支持千亿参数大语 言模型的稳定预训练。

摩尔线程自研大语言模型开发 SDK，助力用户根据应用场景进行微调和应用服务 上线，快速完成大语言模型落地。为用户进一步降低大语言模型推理成本，摩尔线程的 MT Transformer 和 TensorX 推理加速引擎，可以大幅提升大语言模型的性能，降低用户使用成本。


### 科学计算与物理仿真[](https://docs.mthreads.com#科学计算与物理仿真)

用户可使用 MTT S4000 强大和多样的算力求解数学和物理问题，并利用图形渲染能力重现计算或仿真结果，为信号处理、灾害仿真预警、天气预报、影视后期制作等应用提供助力。

### 数字孪生与元宇宙[](https://docs.mthreads.com#数字孪生与元宇宙)

通过完备的图形渲染能力，为用户提供逼真的数字孪生及元宇宙世界中人、物、 场景的�重现，结合先进的 AI 技术，赋予数字孪生及元宇宙世界的互动能力。支持现代图形渲染引擎 OpenGL、OpenGL ES、Vulkan 和 DirectX 等。

### 串流与视频内容[](https://docs.mthreads.com#串流与视频内容)

结合强大视频处理性能和深度学习计算等能力，MTT S4000 可为下一代视频业务 赋予强大的动力，通过 DirectStream 视频流化技术，将高质量的内容带到用户端。 编码支持 AV1、H.264/H.265 等编码格式。解码支持 AV1、H.264、H.265、VP9、AVS2 等解码格式。

脚注：

- FP32 GEMM 矩阵尺寸 8192x8192x1024
- 1400 亿参数模型，单位成本下平均每卡 TPS，训练采用 Zero3+TP+PP，FP16
- 700 亿参数模型，8 x S4000，FP16，Batch Size = 1
- 快速傅里叶变换，基于 muFFT 计算库，ExecR2C 1D，Length=16384，BS=4096
- 同时处理视频路数，编码格式 HEVC，视频分辨率及帧率 1920 x 1080 @ 30fps

## 规格简述[](https://docs.mthreads.com#规格简述)

| MUSA 核心 | 8192 |
|---|---|
| FP32 | 25 TFLOPS |
| TF32 Tensor | 50 TFLOPS |
| FP16 Tensor | 100 TFLOPS |
| INT8 Tensor | 200 TOPS |
| Texure Rate | 768 GTexels/s |
| Pixel Rate | 768 GPixels/s |
| 显存容量 | 48 GB |
| 显存带宽 | 768 GB/s |
| 多媒体编码 | H.265, H.264, AV1 48 x 1080p30 |
| 多媒体解码 | H.265, H.264, AV1, AVS2, VP9,… 96 x 1080p30 |
| I/O 接口带宽 | 240 GB/s |
| 总线接口 | PCIe 5.0 x16 |
| 片间互联 | MTLink |
| 显示接口 | 4 x DisplayPort 1.4a |
| 安全引擎 | MUSA 安全引擎 2.0，支持 TEE 及多种加解密算法 |
| 虚拟化 | 硬件虚拟化，GPU 弹性切分，SR-IOV 隔离 |
| TGP | 450W |
| 尺寸 | 266 mm _ 112 mm _ 39 mm |