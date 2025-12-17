---
layout: default
title: More Than Generation: Unifying Generation and Depth Estimation via Text-to-Image Diffusion Models
---

# More Than Generation: Unifying Generation and Depth Estimation via Text-to-Image Diffusion Models

<div class="paper-toolbar">
  <div class="toolbar-left">
    <a href="https://arxiv.org/abs/2510.23574" target="_blank" class="toolbar-btn">arXiv: 2510.23574v1</a>
    <a href="https://arxiv.org/pdf/2510.23574.pdf" target="_blank" class="toolbar-btn">PDF</a>
  </div>
  <div class="toolbar-right">
    <button class="toolbar-btn favorite-btn" data-arxiv-id="2510.23574v1" 
            onclick="toggleFavorite(this, '2510.23574v1', 'More Than Generation: Unifying Generation and Depth Estimation via Text-to-Image Diffusion Models')" title="收藏">
      ☆ 收藏
    </button>
    <button class="toolbar-btn share-btn" onclick="copyLink()" title="复制链接">
      🔗 分享
    </button>
  </div>
</div>


**作者**: Hongkai Lin, Dingkang Liang, Mingyang Du, Xin Zhou, Xiang Bai

**分类**: cs.CV

**发布日期**: 2025-10-27

**备注**: Accepted by NeurIPS 2025. The code will be made available at https://github.com/H-EmbodVis/MERGE

**🔗 代码/项目**: [GITHUB](https://github.com/H-EmbodVis/MERGE)

---

## 💡 一句话要点

**提出MERGE，通过文本到图像扩散模型统一图像生成与深度估计**

🎯 **匹配领域**: **支柱三：空间感知与语义 (Perception & Semantics)**

**关键词**: `深度估计` `图像生成` `扩散模型` `统一模型` `零样本学习`

## 📋 核心要点

1. 现有方法在训练深度估计时会损害预训练扩散模型的图像生成能力，这是一个挑战。
2. MERGE通过固定预训练模型，引入可插拔转换器和组重用机制，实现图像生成和深度估计的统一。
3. MERGE在多个深度估计基准测试中达到了最先进的性能，同时保持了原有的图像生成能力。

## 📝 摘要（中文）

生成式深度估计方法利用预训练文本到图像扩散模型中丰富的视觉先验，展现出惊人的零样本能力。然而，训练期间的参数更新会导致预训练模型的图像生成能力严重下降。我们提出了MERGE，一个统一的图像生成和深度估计模型，从一个固定的预训练文本到图像模型开始。MERGE证明了预训练的文本到图像模型不仅可以进行图像生成，还可以轻松扩展到深度估计。具体来说，MERGE引入了一个即插即用的框架，通过简单且可插拔的转换器，实现图像生成和深度估计模式之间的无缝切换。同时，我们提出了一种组重用机制，以鼓励参数重用并提高附加可学习参数的利用率。MERGE释放了预训练文本到图像模型强大的深度估计能力，同时保留了其原始的图像生成能力。与其他用于图像生成和深度估计的统一模型相比，MERGE在多个深度估计基准测试中实现了最先进的性能。代码将在https://github.com/H-EmbodVis/MERGE上提供。

## 🔬 方法详解

**问题定义**：论文旨在解决生成式深度估计方法在训练过程中破坏预训练文本到图像扩散模型图像生成能力的问题。现有方法在更新参数以适应深度估计任务时，会导致模型原有的图像生成能力下降，无法同时兼顾两个任务。

**核心思路**：论文的核心思路是利用预训练文本到图像扩散模型中已经存在的丰富视觉先验知识，并在此基础上扩展其深度估计能力，同时避免修改预训练模型的参数。通过引入额外的可学习模块，实现图像生成和深度估计之间的切换，从而达到统一两个任务的目的。

**技术框架**：MERGE的整体框架包含一个固定的预训练文本到图像扩散模型，以及两个可插拔的转换器：一个用于图像生成，另一个用于深度估计。用户可以通过选择不同的转换器，在图像生成和深度估计模式之间切换。此外，MERGE还引入了组重用机制，以提高附加可学习参数的利用率。

**关键创新**：MERGE的关键创新在于其“play-and-plug”框架，该框架允许在图像生成和深度估计之间无缝切换，而无需修改预训练模型的参数。此外，组重用机制也是一个重要的创新点，它通过鼓励参数重用，提高了附加可学习参数的效率。

**关键设计**：MERGE的关键设计包括：1) 可插拔转换器的具体结构，需要根据不同的任务进行设计；2) 组重用机制的实现方式，例如如何分组参数以及如何进行参数重用；3) 损失函数的设计，需要同时考虑图像生成和深度估计的性能。

## 📊 实验亮点

MERGE在多个深度估计基准测试中取得了state-of-the-art的性能，证明了其有效性。与现有的统一模型相比，MERGE不仅在深度估计方面表现出色，而且能够保持预训练模型的原始图像生成能力。具体的性能数据需要在论文中查找，但总体而言，MERGE在深度估计精度和图像生成质量方面都取得了显著的提升。

## 🎯 应用场景

该研究成果可应用于机器人导航、自动驾驶、虚拟现实等领域。通过统一图像生成和深度估计，可以为机器人提供更全面的环境感知能力，使其能够更好地理解和操作周围的世界。此外，该方法还可以用于生成具有深度信息的虚拟场景，从而提升虚拟现实体验。

## 📄 摘要（原文）

> Generative depth estimation methods leverage the rich visual priors stored in pre-trained text-to-image diffusion models, demonstrating astonishing zero-shot capability. However, parameter updates during training lead to catastrophic degradation in the image generation capability of the pre-trained model. We introduce MERGE, a unified model for image generation and depth estimation, starting from a fixed pre-trained text-to-image model. MERGE demonstrates that the pre-trained text-to-image model can do more than image generation, but also expand to depth estimation effortlessly. Specifically, MERGE introduces a play-and-plug framework that enables seamless switching between image generation and depth estimation modes through simple and pluggable converters. Meanwhile, we propose a Group Reuse Mechanism to encourage parameter reuse and improve the utilization of the additional learnable parameters. MERGE unleashes the powerful depth estimation capability of the pre-trained text-to-image model while preserving its original image generation ability. Compared to other unified models for image generation and depth estimation, MERGE achieves state-of-the-art performance across multiple depth estimation benchmarks. The code will be made available at https://github.com/H-EmbodVis/MERGE

