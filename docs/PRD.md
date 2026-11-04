# PRD — Lawu-2.5-Fine · Server Setup & Deployment

**Versi:** 3.3.0
**Update:** 2026-11-04
**Perubahan major v3.1.0:** Hardening server dipindah ke LANGKAH TERAKHIR (sebelum go-live checklist). Setup: **jalan dulu → lalu amankan**.
**Perubahan v3.1.1:** HDD ikut terformat saat install ulang OS. Langkah 3 diperkuat: fstab AUTOMOUNT wajib dengan `nofail` + validasi `findmnt --verify` + TEST REBOOT sebelum lanjut.
**Perubahan v3.2.0:** Korpus baru **Wikipedia-ID** (`indonesian-nlp/wikipedia-id` — 1,44 juta artikel, parquet ~345MB) sebagai dataset pelatihan Indonesia. Langkah 12 baru; langkah 12-19 lama bergeser ke 13-20. Total **21 langkah (0-20)**.
**Perubahan v3.3.0 (2026-11-04):** (1) RAM di-upgrade dari 8GB ke **16GB DDR4** — semua tuning dilonggarkan kembali ke nilai optimal; (2) Model di-upgrade dari Q3_K_M (3.55GB) ke **Q4_K_M (4.4GB)** untuk kualitas lebih baik; (3) Paten 2 diubah dari Vue.js 3 ke **Next.js 16 App Router** (sesuai realitas implementasi — dashboard sudah dibangun dengan Next.js); (4) Korpus Wikipedia-ID berhasil terindex (1,38 juta artikel, query < 1ms); (5) Langkah 12 & 13 selesai di server asli.

---

## 1. Ringkasan Proyek

Lawu-2.5-Fine adalah AI model Indonesia ("AI Model Cerdas, Irit Budget") untuk search engine ebook dengan 7 Paten terkunci yang TIDAK BOLEH dilanggar:

| # | Paten | Status |
|---|---|---|
| 1 | **Rust** = satu-satunya backend (Axum + Tantivy) | ✅ Terpenuhi |
| 2 | **Next.js 16** = satu-satunya frontend (App Router + shadcn/ui) | ✅ Terpenuhi (v3.3.0 — sebelumnya Vue.js 3) |
| 3 | **Pure CPU+RAM+SSD** = NO GPU, NO cloud API | ✅ Terverifikasi (`ldd` bersih) |
| 4 | **Linux only** = Debian 13 (trixie) | ✅ Terpenuhi |
| 5 | **Open source** = MIT/Apache/BSD/GPL saja | ✅ Terpenuhi |
| 6 | **Parallel RARE** = 5-way retrieval + 1 LLM call | ✅ Terpenuhi |
| 7 | **Islam** = Ahlussunnah wal Jama'ah, permanen | ✅ Terpenuhi |

**Target hardware:**
- CPU: Intel Core i5-10400 (6C/12T, AVX2)
- RAM: **16 GB DDR4** (di-upgrade dari 8GB pada 2026-11-04 — lihat Pelajaran #10)
- Disk: SSD 128 GB (OS) + HDD 500 GB (DATA — ebook, index, models, backup)

---

## 2. Prinsip Setup yang BENAR (Pelajaran Penting v3.1.0)

> ⚠️ **Pelajaran mahal dari incident 2026-11-03:**
> Hardening (disable SSH password) di awal setup menyebabkan user terkunci dari server
> sendiri → reinstall OS. Ini kesalahan urutan, bukan kesalahan teknik.

**Prinsip deployment yang benar:**

```
1. JALANKAN DULU (get it running)
   ↓ Install semua service, test endpoint, debug dari SSH password biasa
2. LALU AMANKAN (lock it down)
   ↓ Setelah SEMUA service jalan + test sukses → baru hardening
3. TERAKHIR: GO-LIVE CHECKLIST
   ↓ Audit final sebelum buka ke publik
```

**Alasan teknis:**
- SSH password aktif = debugging mudah (bisa SSH dari laptop kapan saja)
- UFW belum aktif = tidak ada risiko port blocked salah konfigurasi
- fail2ban belum jalan = tidak ada risiko IP sendiri ke-ban
- Kalau ada error setup, fix-nya cepat tanpa harus akses konsol fisik

---

## 3. Urutan Langkah Setup yang BENAR (v3.1.0)

### FASE 1 — Persiapan Server (Langkah 0-3)

| Langkah | Judul | Isi |
|---|---|---|
| **0** | Bersihkan Server | Audit → stop service lama → backup → hapus → verify |
| **1** | Prerequisites | apt update + install build deps, nginx, python venv |
| **2** | User lawu & Direktori | useradd lawu (no sudo), /opt/lawu (SSD), /mnt/data (HDD), symlink ~/models → /mnt/data/models |
| **3** | Mount & Format HDD | parted GPT → mkfs.ext4 → **fstab automount (nofail + device-timeout)** → findmnt --verify → **TEST REBOOT** → TRIM → SSD tuning |

### FASE 2 — Build & Deploy Services (Langkah 4-13)

| Langkah | Judul | Isi |
|---|---|---|
| **4** | Arsitektur | Diagram end-to-end alur data |
| **5** | Kernel Tuning | sysctl (vm.swappiness=20 utk RAM 16GB) + limits.conf |
| **6** | Install Rust | rustup stable, RUSTFLAGS=-C target-cpu=native, verify ldd murni CPU |
| **7** | Project Cargo | cargo new lawu-server + Cargo.toml (axum 0.8, tantivy 0.24) + build release |
| **8** | Tantivy schema | schema.rs multi-field BM25 (docid, title, text, split) |
| **9** | Axum API | main.rs: /health, /api/search, /api/stats |
| **10** | Build llama.cpp | clone ggml-org/llama.cpp tag b12069+, cmake STATIC linking, -j 6 (RAM 16GB) |
| **11** | Model GGUF | wget pre-quantized Qwen2.5-Coder-7B **Q4_K_M (4.4GB)** ke HDD |
| **12** | Korpus Wikipedia-ID | Download dataset `indonesian-nlp/wikipedia-id` → JSONL streaming → Tantivy index |
| **13** | Serve + systemd | llama-server -t 6 -c 4096, test /v1/chat/completions, systemd auto-start |

### FASE 3 — Otomasi & Dashboard (Langkah 14-18)

| Langkah | Judul | Isi |
|---|---|---|
| **13** | Serve + systemd | llama-server -t 6 -c 4096, test /v1/chat/completions, systemd auto-start |
| **14** | Otomasi | watch_ebooks.sh, backup_lawu.sh, send_error_report.sh, cron, /etc/lawu/env |
| **15** | Load Testing | k6: p95 /api/search < 300ms dengan 20 VUs |
| **16** | Nginx Reverse Proxy | port 80 → Axum :3001 + llama :8080 (/v1/) |
| **17** | Integrasi Dashboard | Next.js 16 dashboard deploy ke srv-fine, proxy ke Rust backend |
| **18** | ⭐ **HARDENING** | UFW (deny incoming, allow 22/80/443) + SSH key-only + fail2ban — **DIPINDAH KE SINI (terakhir sebelum go-live)** |
| **19** | Go-Live Checklist | Audit final: sistem, disk, firewall, services, ports, API health, cron, backup, memory |

### FASE 4 — Amankan & Go-Live (Langkah 18-19)

| Langkah | Judul | Isi |
|---|---|---|
| **18** | ⭐ **HARDENING** | UFW (deny incoming, allow 22/80/443) + SSH key-only + fail2ban — **TERAKHIR sebelum go-live** |
| **19** | Go-Live Checklist | Audit final: sistem, disk, firewall, services, ports, API health, cron, backup, memory |

---

## 4. Hardening — Detail Langkah 18 (v3.3.0)

Hardening HANYA dijalankan setelah:
- ✅ Semua service jalan (systemd active, HTTP 200)
- ✅ Test endpoint sukses (chat completion bisa respon)
- ✅ Load test lulus (p95 < 300ms)
- ✅ Dashboard Next.js connect ke API

**Urutan hardening yang aman:**

```bash
# 1) PASTIKAN SSH KEY SUDAH TERSETUP + TEST LOGIN DENGAN KEY
#    (di laptop: ssh -i ~/.ssh/lawu_admin admin@server — harus sukses)
# 2) BARU disable password auth
# 3) Enable UFW (test rule 22 dulu sebelum deny)
# 4) fail2ban TERAKHIR (setelah semua lainnya aman)
```

**Jangan pernah:**
- ❌ Disable SSH password sebelum SSH key terverifikasi
- ❌ Enable UFW default-deny sebelum test akses current
- ❌ Hardening saat masih ada langkah setup yang belum selesai

---

## 5. Stack Teknologi & Versi (Terverifikasi di Server Asli)

| Komponen | Versi | Catatan |
|---|---|---|
| Debian | 13 (trixie) | Kernel 6.x |
| Rust | 1.99.1 (2026-10-13) | via rustup, stable |
| Axum | 0.8 | (bukan 0.7 — incompatible dengan Rust 1.99) |
| Tantivy | 0.24.2 | (bukan 0.22 — API berubah) |
| tokio | 1.x | full features |
| llama.cpp | b12069 (build 12069, commit e6192de0a) | ggml-org repo, static linking |
| Model | Qwen2.5-Coder-7B **Q4_K_M** | 4.4GB, ~7 tok/s di i5-10400 (RAM 16GB) |
| Python | 3.13 | venv untuk pyarrow + huggingface-cli |
| Nginx | 1.26+ | reverse proxy |
| Frontend | **Next.js 16 (App Router + shadcn/ui)** | (Paten 2 v3.3.0 — sebelumnya Vue.js 3) |

---

## 6. Konfigurasi RAM 16GB (Di-upgrade dari 8GB pada 2026-11-04)

**RAM budget saat inference (7B Q4_K_M + 16GB):**
```
Model mmap load    : ~4.4GB
KV cache ctx 4096  : ~0.5GB
Axum + Tantivy     : ~0.6GB
OS + page cache    : ~2.5GB
─────────────────────────────────
TOTAL              : ~8.0GB (headroom ~8GB)
```

**Parameter yang disesuaikan (16GB — dilonggarkan dari tuning 8GB):**

| Parameter | Nilai (RAM 16GB, v3.3.0) | Nilai lama (RAM 8GB, v3.0-3.2) |
|---|---|---|
| `vm.swappiness` | **20** | 40 |
| `cmake --build -j` | **6** | 3 |
| `llama-server -t` | **6** | 4 |
| `llama-server -c` | **4096** | 2048 |
| Model default | **Q4_K_M (4.4GB)** | Q3_K_M (3.6GB) |

---

## 7. Struktur Direktori

```
SSD 128GB (OS):
├── /opt/lawu/              # scripts, binary, logs (755/640)
├── /home/lawu/
│   ├── src/llama.cpp/      # source tree (build di sini — cepat)
│   ├── .cargo/bin/lawu-server  # binary Axum API
│   └── models -> /mnt/data/models  # SYMLINK ke HDD

HDD 500GB (DATA — /dev/sdb1, ext4, automount via fstab: `defaults,noatime,nofail,x-systemd.device-timeout=10s`):
# nofail = WAJIB — server tetap boot walau HDD gagal/cabut
# WAJIB test reboot setelah konfigurasi: mount manual HILANG saat reboot!
├── /mnt/data/
│   ├── datasets/           # dataset mentah (parquet)
│   │   └── wikipedia-id/   # train/test parquet (~345MB, indonesian-nlp)
│   ├── ebooks/             # PDF·EPUB·DOCX koleksi
│   │   ├── incoming/       # file watcher (inotifywait)
│   │   └── processed/
│   ├── processed_markdowns/  # hasil ekstraksi MarkltDown + korpus Wikipedia-ID
│   │   └── wikipedia-id/{train,test}/{a..z,_}/*.md  # 1,44jt artikel (Langkah 12)
│   ├── tantivy_index/      # BM25 index
│   ├── backup/             # retensi 7 hari
│   └── models/             # GGUF (fisik di sini!)
```

---

## 8. Status Setup Saat Ini (Server Asli)

> ⚠️ **RESET — server di-reinstall ulang (HDD ikut terformat).** Semua progress sebelumnya
> hilang. Mulai ulang dari Langkah 0. Model GGUF Q4_K_M (4.4GB) download ulang di Langkah 11.
>
> ✅ **UPDATE v3.3.0 (2026-11-04):** RAM di-upgrade dari 8GB ke 16GB. Model di-upgrade dari
> Q3_K_M ke Q4_K_M. Korpus Wikipedia-ID 1,38 juta artikel sudah ter-index (Langkah 12 selesai).
> Search API lawu-server jalan sebagai systemd (Langkah 13 selesai). Test serve llama-server
> berhasil (Langkah 12 — 7.91 tok/s dengan Q3_K_M, akan re-test dengan Q4_K_M).

| Langkah | Status | Catatan |
|---|---|---|
| 0. Bersihkan server | ✅ | server fresh hasil reinstall |
| 1. Prerequisites | ✅ | apt deps terinstall |
| 2. User & direktori | ✅ | user lawu + symlinks |
| 3. Mount HDD + AUTOMOUNT | ✅ | fstab nofail verified, test reboot OK |
| 4. Arsitektur | ✅ | /mnt/data/* struktur siap |
| 5. sysctl | ✅ | swappiness=20 (16GB) |
| 6. Rust toolchain | ✅ | rustc 1.99.1 |
| 7. Cargo project | ✅ | lawu-server v0.1.0 (Paten 3 ✓) |
| 8. Tantivy schema | ✅ | 4 fields: docid, title, text, split |
| 9. Axum API | ✅ | /health, /api/search, /api/stats |
| 10. llama.cpp build | ✅ | b12069, gcc 14.2.0, -j 6 |
| 11. Model GGUF | ✅ | Q4_K_M (4.4GB) terdownload, service updated |
| 12. Korpus Wikipedia-ID | ✅ | 1.38jt artikel terindex, query < 1ms |
| 13. Serve llama.cpp | ✅ | test OK, Q4_K_M aktif, systemd auto-start |
| 13b. systemd lawu-server | ✅ | auto-start post-reboot verified |
| 14. systemd llama-server | ✅ | lawu-llama.service active, Q4_K_M |
| 15. Otomasi | ⏳ | watch_ebooks.sh, backup, cron |
| 16. k6 load test | ⏳ | p95 < 300ms dengan 20 VUs |
| 17. Nginx reverse proxy | ⏳ | port 80 → Axum :3001 + llama :8080 |
| 18. Integrasi Dashboard | ✅ | Next.js 16 deploy ke srv-fine via GitHub, PM2 online |
| 19. **Hardening** | ⏳ | **TERAKHIR!** |
| 20. Go-Live | ⏳ | audit final |

**Incident log:**
- 2026-11-03: User terkunci dari server setelah hardening di Langkah 4 lama (SSH password disabled sebelum semua service jalan). Solusi: reinstall OS + susun ulang urutan (v3.1.0 — hardening pindah ke Langkah 18).
- 2026-11-03 (v3.1.1): Saat install ulang OS, HDD 500GB ikut terformat — model GGUF, ebook, dan index hilang. Pelajaran: (1) saat installer minta partisi, PILIH HANYA SSD OS dan pastikan HDD tidak tercentang; (2) Langkah 3.C fstab WAJIB pakai `nofail` + `findmnt --verify` + TEST REBOOT sebelum lanjut — mount manual hilang saat reboot dan fstab salah bisa bikin server gagal boot.
- 2026-11-03 (v3.2.0): Konversi parquet → markdown per-artikel memicu inode exhaustion (file system habis di 119K file, padahal size masih 473MB). Penyebab: `mkfs.ext4 -T largefile4` di Langkah 3.C mengoptimasi untuk file besar tapi mengurangi inode count drastis (4MB/inode → ~119K total inodes). Solusi: ubah strategi dari 600K file `.md` ke 1 file JSONL per split (1 inode per split). Pelajaran: untuk corpus 600K+ dokumen kecil, gunakan JSONL/parquet, BUKAN file individual.
- 2026-11-04 (v3.3.0): RAM di-upgrade dari 8GB ke 16GB. Penemuan: `free -h` menunjukkan 16Gi, padahal PRD sejak v3.0 mengasumsikan 8GB. Selama ini semua tuning (swappiness=40, -j 3, ctx 2048, Q3_K_M) terlalu konservatif. Solusi: upgrade ke Q4_K_M (kualitas lebih baik), longgarkan tuning ke nilai optimal 16GB. Pelajaran #10: **verifikasi hardware aktual via `free -h` / `lscpu` / `lsblk` sebelum finalisasi PRD — jangan percaya spec awal 100%.**

---

## 9. Kata Kunci dari Incident (Pelajaran Terbaik)

1. **"Get it running first, then lock it down"** — bukan sebaliknya
2. **Jangan pernah paste block yang mengandung `exit`** — shell jalan tanpa syarat
3. **Sediakan jalur rollback** sebelum hardening (backup sshd_config, dst.)
4. **Test SSH key SEBELUM disable password** — selalu
5. **Dokumentasikan user admin** — siapa yang punya sudo, password-nya apa
6. **Installer Debian: jaga HDD dari partisi otomatis** — centang HANYA SSD OS saat partitioning
7. **Data disk WAJIB fstab `nofail` + test reboot** — mount manual hilang saat reboot;
   fstab salah syntax = server gagal boot (validasi dengan `findmnt --verify` dulu)
8. **`-T largefile4` cocok untuk file besar, BUKAN untuk corpus banyak file kecil** — untuk 600K+ dokumen markdown kecil, gunakan JSONL/parquet (1 inode per split) alih-alih file individual
9. **Saat beralih dari manual run ke systemd service, WAJIB kill instance manual dulu** (`pkill -9 -f binary_name`) — kalau tidak, port conflict membuat service flapping dengan restart counter tinggi
10. **Verifikasi hardware aktual via `free -h` / `lscpu` / `lsblk` sebelum finalisasi PRD** — jangan percaya spec awal 100%. RAM yang dikira 8GB ternyata 16GB → semua tuning konservatif terbukti berlebihan
11. **Terminal SSH konsisten bermasalah dengan heredoc `cat << 'EOF'` panjang** — gunakan `python3 << 'PYEOF'` untuk menulis file konfigurasi (service, .toml, .rs) — lebih reliable
