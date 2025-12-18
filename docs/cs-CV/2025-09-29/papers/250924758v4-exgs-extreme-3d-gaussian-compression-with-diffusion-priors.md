---
layout: default
title: ExGS: Extreme 3D Gaussian Compression with Diffusion Priors
---

# ExGS: Extreme 3D Gaussian Compression with Diffusion Priors

<div class="paper-toolbar">
  <a href="https://arxiv.org/abs/2509.24758" class="toolbar-btn" target="_blank">📄 arXiv: 2509.24758v4</a>
  <a href="https://arxiv.org/pdf/2509.24758.pdf" class="toolbar-btn" target="_blank">📥 PDF</a>
  <button class="toolbar-btn favorite-btn" data-arxiv-id="2509.24758v4" data-paper-url="__CURRENT_PAGE__" onclick="toggleFavorite(this, '2509.24758v4', 'ExGS: Extreme 3D Gaussian Compression with Diffusion Priors')" title="添加到收藏夹">☆ 收藏</button>
  <button class="toolbar-btn" onclick="copyLinkToClipboard(this)">🔗 分享</button>
</div>


**作者**: Jiaqi Chen, Xinhao Ji, Yuanyuan Gao, Hao Li, Yuning Gong, Yifei Liu, Dan Xu, Zhihang Zhong, Dingwen Zhang, Xiao Sun

**分类**: cs.CV

**发布日期**: 2025-09-29 (更新: 2025-10-07)

**🔗 代码/项目**: [GITHUB](https://github.com/chenttt2001/ExGS)

---

## 💡 一句话要点

**ExGS：利用扩散先验实现极端3D高斯压缩，兼顾高质量渲染**

🎯 **匹配领域**: **支柱三：空间感知与语义 (Perception & Semantics)**

**关键词**: `3D高斯溅射` `神经渲染` `模型压缩` `扩散模型` `图像修复`

## 📋 核心要点

1. 3DGS虽然渲染质量高，但存储和传输成本高昂，现有压缩方法难以兼顾效率和质量。
2. ExGS结合UGC和GaussPainter，先剪枝减少高斯基元，再用扩散先验恢复高质量渲染。
3. 实验表明，ExGS能实现超过100倍的压缩，同时保持渲染质量，显著优于现有方法。

## 📝 摘要（中文）

神经场景表示，如3D高斯溅射(3DGS)，实现了高质量的神经渲染；然而，其庞大的存储和传输成本阻碍了在资源受限环境中的部署。现有的压缩方法要么依赖于代价高昂的优化，速度慢且特定于场景，要么采用免训练的剪枝和量化，这会在高压缩比下降低渲染质量。相比之下，最近的数据驱动方法提供了一个有希望的方向来克服这种权衡，能够在保持高质量渲染的同时实现高效压缩。我们介绍ExGS，这是一个新颖的前馈框架，它统一了通用高斯压缩(UGC)和GaussPainter，用于极端3DGS压缩。UGC执行免重新优化的剪枝，以积极减少高斯基元，同时仅保留基本信息，而GaussPainter利用强大的扩散先验与掩码引导的细化，从严重剪枝的高斯场景中恢复高质量的渲染。与传统的图像修复不同，GaussPainter不仅填充缺失区域，还增强可见像素，从而显着改善退化的渲染效果。为了确保实用性，它采用了轻量级的VAE和一步扩散设计，从而实现实时恢复。我们的框架甚至可以实现超过100倍的压缩（将典型的354.77 MB模型减少到大约3.31 MB），同时保持保真度并显着提高具有挑战性条件下的图像质量。这些结果突出了扩散先验在弥合极端压缩和高质量神经渲染之间差距的核心作用。我们的代码库将在https://github.com/chenttt2001/ExGS发布。

## 🔬 方法详解

**问题定义**：论文旨在解决3D高斯溅射(3DGS)模型体积庞大，难以在资源受限环境下部署的问题。现有压缩方法，如剪枝和量化，虽然可以减小模型体积，但会导致渲染质量显著下降；而基于优化的压缩方法速度慢，且需要针对每个场景进行优化，泛化性差。

**核心思路**：论文的核心思路是结合通用高斯压缩(UGC)和基于扩散模型的图像修复(GaussPainter)。UGC负责高效地剪枝掉不重要的高斯基元，大幅减小模型体积；GaussPainter则利用扩散先验，从高度压缩后的高斯场景中恢复高质量的渲染结果。这种解耦的设计允许分别优化压缩效率和渲染质量。

**技术框架**：ExGS框架包含两个主要模块：UGC和GaussPainter。首先，UGC对3DGS模型进行剪枝，去除冗余的高斯基元。然后，将剪枝后的高斯场景输入到GaussPainter中。GaussPainter利用一个轻量级的VAE和一个单步扩散模型，对渲染结果进行修复和增强，最终生成高质量的图像。整个过程是前馈的，无需迭代优化。

**关键创新**：ExGS的关键创新在于将通用高斯压缩与基于扩散模型的图像修复相结合，实现极端压缩的同时保持高质量的渲染。与传统的图像修复方法不同，GaussPainter不仅填充缺失区域，还增强可见像素，从而显著改善退化的渲染效果。此外，采用轻量级的VAE和单步扩散设计，保证了实时恢复的速度。

**关键设计**：GaussPainter采用了轻量级的VAE来编码输入图像，并使用一个单步扩散模型进行图像修复。扩散模型使用掩码引导的细化，只在缺失区域进行修复，同时增强可见区域的细节。损失函数包括L1损失和感知损失，以保证图像的保真度和视觉质量。具体参数设置和网络结构细节未在摘要中详细说明，需要在论文正文中查找。

## 📊 实验亮点

ExGS实现了超过100倍的3DGS模型压缩，将一个典型的354.77MB模型压缩到约3.31MB。在极端压缩条件下，ExGS仍然能够保持较高的渲染质量，并在具有挑战性的场景中显著提升图像质量。实验结果表明，ExGS在压缩率和渲染质量之间取得了显著的平衡，优于现有的压缩方法。

## 🎯 应用场景

ExGS在资源受限的场景中具有广泛的应用前景，例如移动设备上的3D内容渲染、VR/AR应用中的场景传输、以及云游戏等。通过大幅降低3D模型的存储和传输成本，ExGS可以促进3D技术在更多领域的普及和应用，并为用户提供更流畅、更逼真的体验。

## 📄 摘要（原文）

> Neural scene representations, such as 3D Gaussian Splatting (3DGS), have enabled high-quality neural rendering; however, their large storage and transmission costs hinder deployment in resource-constrained environments. Existing compression methods either rely on costly optimization, which is slow and scene-specific, or adopt training-free pruning and quantization, which degrade rendering quality under high compression ratios. In contrast, recent data-driven approaches provide a promising direction to overcome this trade-off, enabling efficient compression while preserving high rendering quality. We introduce ExGS, a novel feed-forward framework that unifies Universal Gaussian Compression (UGC) with GaussPainter for Extreme 3DGS compression. UGC performs re-optimization-free pruning to aggressively reduce Gaussian primitives while retaining only essential information, whereas GaussPainter leverages powerful diffusion priors with mask-guided refinement to restore high-quality renderings from heavily pruned Gaussian scenes. Unlike conventional inpainting, GaussPainter not only fills in missing regions but also enhances visible pixels, yielding substantial improvements in degraded renderings. To ensure practicality, it adopts a lightweight VAE and a one-step diffusion design, enabling real-time restoration. Our framework can even achieve over 100X compression (reducing a typical 354.77 MB model to about 3.31 MB) while preserving fidelity and significantly improving image quality under challenging conditions. These results highlight the central role of diffusion priors in bridging the gap between extreme compression and high-quality neural rendering. Our code repository will be released at: https://github.com/chenttt2001/ExGS

